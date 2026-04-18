// Package query
// File: state.go
// Description: query loop 의 반복 간 가변 상태 구조체
// Responsibility: QueryState 의 필드 정의 및 초기화
//
// Ported from: claude_cli/src/query.ts:204-217 (State type)
// 핵심 패턴: TS mutable State 객체 → Go value-type struct (continue 지점마다 복사)

package query

import (
	"github.com/yourorg/infractl/internal/llm"
	"github.com/yourorg/infractl/internal/tools"
)

// Params 는 Engine.Run 에 전달되는 불변(immutable) 입력 파라미터다.
// claude_cli: QueryParams (query.ts:181-198)
type Params struct {
	// Messages 는 현재까지의 대화 기록이다.
	Messages []llm.Message
	// SystemMsg 는 조립된 시스템 메시지다 (boundary 포함).
	SystemMsg llm.Message
	// Tier 는 classify 단계에서 결정된 LLM 티어다 (InfraCtl 고유 차별점).
	Tier llm.Tier
	// Client 는 해당 티어의 LLM 클라이언트다.
	Client llm.Client
	// ModelName 은 사용 중인 모델 이름 (로깅/telemetry용).
	ModelName string
	// Tools 는 LLM 에 전달할 도구 정의 목록이다.
	Tools []llm.ToolDef
	// MaxTurns 는 최대 반복 횟수다 (0이면 기본값 50 사용).
	MaxTurns int
	// RunTool 은 단일 도구 호출을 실행하는 함수다.
	// nil 이면 모든 도구 호출이 에러로 처리된다.
	// Phase B: agent.executeSingleTool 을 래핑하여 전달.
	// Phase D 활성화 후: tool_invoker.Invoke 로 교체.
	RunTool ToolRunner
	// Registry 는 도구 레지스트리다. PartitionToolCalls 에서 IsReadOnly 판단에 사용한다.
	// nil 이면 모든 도구를 mutation (직렬) 으로 취급한다.
	Registry *tools.Registry
	// ContextWindow 는 모델의 최대 컨텍스트 토큰 수다.
	// compact.Stack.Apply 의 토큰 상태 계산에 사용된다. 0이면 compact 가 TokenOK 로 간주한다.
	ContextWindow int
	// SystemTokens 는 시스템 메시지의 추정 토큰 수다.
	// ContextWindow 에서 차감하여 메시지에 사용 가능한 실제 토큰을 계산한다.
	SystemTokens int
}

// state 는 query loop 의 단일 iteration 에서 다음 iteration 으로 전달되는 가변 상태다.
// claude_cli: State (query.ts:204-217) — continue 지점마다 전체를 새로 할당한다.
// 필드는 loop body 시작 시 destructure 하여 읽기 전용으로 취급한다.
type state struct {
	// messages 는 현재까지 누적된 대화 메시지 목록이다.
	messages []llm.Message
	// turnCount 는 현재 turn 번호 (1부터 시작)다.
	turnCount int
	// maxOutputTokensRecoveryCount 는 max_output_tokens 복구 재시도 횟수다.
	maxOutputTokensRecoveryCount int
	// hasAttemptedReactiveCompact 는 이번 루프에서 reactive compaction 을 시도했는지 여부다.
	hasAttemptedReactiveCompact bool
	// maxOutputTokensOverride 는 max_output_tokens 에스컬레이션 시 적용할 재정의 값이다.
	// nil 이면 모델 기본값을 사용한다.
	maxOutputTokensOverride *int
	// transition 은 직전 iteration 에서 continue 를 선택한 이유다.
	// 첫 iteration 에서는 nil 이다.
	transition *ContinueReason
}

// initialState 는 주어진 params 로 loop 초기 상태를 생성한다.
func initialState(messages []llm.Message) state {
	return state{
		messages:  messages,
		turnCount: 1,
	}
}

// withTransition 은 state 를 복사하고 transition reason 을 설정한 새 state 를 반환한다.
// claude_cli: `state = { ...state, transition: { reason: '...' } }` 패턴
func (s state) withTransition(reason ContinueReason) state {
	s.transition = &reason
	return s
}
