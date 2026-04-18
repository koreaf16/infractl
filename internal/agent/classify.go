// Package agent
// File: classify.go
// Description: General LLM의 자기 분류로 필요한 도구·섹션·실행 모델을 결정하는 로직
// Responsibility: 사용자 요청을 분석하여 ToolGroups, PromptSections, 실행 Tier를 결정

package agent

import (
	"context"
	"encoding/json"
	"fmt"
	"log/slog"
	"regexp"
	"strings"

	"github.com/yourorg/infractl/internal/cost"
	"github.com/yourorg/infractl/internal/llm"
)

// ClassifyResult는 LLM 분류 단계에서 결정된 도구·섹션·모델 선택 결과이다.
type ClassifyResult struct {
	NeedsTools           bool     `json:"needs_tools"`
	ToolGroups           []string `json:"tool_groups"`
	PromptSections       []string `json:"prompt_sections"`
	Tier                 string   `json:"tier"`                             // "fast", "general", "reasoning"
	TaskType             string   `json:"task_type,omitempty"`              // reasoning 작업 유형: "install", "troubleshoot", "configure", "analyze", "migrate", "plan"
	Complexity           string   `json:"complexity,omitempty"`             // "simple" | "complex"
	RequiresTaskProposal bool     `json:"requires_task_proposal,omitempty"` // true if complex task needs propose_task first
}

// classifySystemPrompt는 분류 단계의 시스템 프롬프트이다.
const classifySystemPrompt = `당신은 인프라 관리 AI 에이전트 infractl입니다.
사용자 요청을 분석하여 아래 항목을 결정하세요:
1. 도구: 어떤 도구 그룹과 지시 섹션이 필요한가?
2. 모델: 실행에 가장 적합한 LLM 티어는 무엇인가?

## Model Tier Selection (CRITICAL — read carefully)

### "reasoning" — 반드시 이 티어를 선택해야 하는 경우:
- 설치/구성 작업: "nginx 설치해줘", "Oracle DB 설정해줘", "방화벽 규칙 추가해줘", "패키지 설치"
- 트러블슈팅/디버깅: "왜 안 되지?", "에러 원인 찾아줘", "서비스가 죽었어", "연결이 안 돼"
- 복잡한 분석: "로그 분석해서 원인 찾아줘", "성능 저하 원인 파악", "보안 점검해줘"
- 계획/아키텍처: "마이그레이션 계획 세워줘", "HA 구성 전략", "백업 전략", "아키텍처 검토"
- 멀티스텝 작업: 여러 명령어를 순서대로 실행해야 하는 복잡한 작업
- Examples: "install", "setup", "configure", "troubleshoot", "debug", "analyze", "why", "fix", "migrate", "plan"

### "fast" — 이 티어를 선택해야 하는 경우:
- 이전 결과 요약/정리: "방금 결과 요약해줘", "정리해서 보여줘", "표로 만들어줘"
- 단순 포맷 변환: "JSON으로 변환해줘", "마크다운으로 정리해줘"
- 단순 상태 확인 (단일 명령): "서버 목록 보여줘", "현재 연결 상태"
- 간단한 설명 질문: "이 설정 값이 뭔지 설명해줘", "이 명령어가 뭐야"
- Examples: "summarize", "format", "list", "show", "what is", "explain briefly"

### "general" — 나머지 일반 작업 (기본값):
- 표준 명령어 실행: "ls -la", "ps aux", "systemctl status nginx"
- 파일 조회/수정: "config 파일 읽어줘", "로그 마지막 100줄 보여줘"
- 일반적인 서버 운영 (설치/트러블슈팅이 아닌): "서비스 재시작해줘", "디스크 확인해줘"
- 단순 서버 접속/포커스: "oracle 서버 접속해줘", "AI26 서버로 가줘" (reasoning 선택 금지)

### 판단 원칙:
- 확실하지 않으면 "general" 선택 (안전한 기본값)
- "설치", "install", "트러블슈팅", "troubleshoot", "분석", "analyze", "계획", "plan", "왜", "why", "원인", "장애" 키워드 → 반드시 "reasoning"
- 단순 조회/요약/포맷팅 → "fast"
- 단순 접속/포커스 요청은 reasoning이 아닌 general 선택.


## Task Type (tier=reasoning일 때만 설정)

reasoning 티어를 선택한 경우, 작업 유형을 아래 중 하나로 반드시 지정하세요:
- "install"      — 소프트웨어/패키지 설치, 배포, 구축: "nginx 설치해줘", "docker 깔아줘", "패키지 추가해줘"
- "troubleshoot" — 문제 해결, 디버깅, 장애 대응: "왜 안 되지?", "서비스가 죽었어", "에러 원인 찾아줘", "연결이 안 돼"
- "configure"    — 설정 변경, 구성, 수정: "nginx 설정 변경해줘", "방화벽 규칙 추가해줘", "config 수정"
- "analyze"      — 분석, 점검, 진단: "성능 분석해줘", "보안 점검해줘", "로그 분석해줘"
- "migrate"      — 마이그레이션, 업그레이드, 이전: "버전 업그레이드해줘", "DB 마이그레이션"
- "plan"         — 계획 수립, 아키텍처 설계, 전략: "HA 구성 전략", "마이그레이션 계획 세워줘"

task_type 판단 예시:
- "nginx 설치해줘" → task_type: "install"
- "왜 서비스가 죽었는지 분석해줘" → task_type: "troubleshoot"
- "Oracle DB 설정 변경해줘" → task_type: "configure"
- "CPU 성능 저하 원인 파악해줘" → task_type: "analyze"
- "MySQL 8.0으로 업그레이드해줘" → task_type: "migrate"
- "HA 이중화 아키텍처 계획 세워줘" → task_type: "plan"

## needs_tools 판단 기준 (CRITICAL)
needs_tools=FALSE 로 설정하는 경우:
- 인사말, 작별인사: "하이", "안녕", "hi", "hello", "bye", "잘가"
- 감사/인정: "감사", "고마워", "thanks", "ㄱㅅ", "넵", "ㅎㅎ"
- 인프라 의도 없는 일상 대화
- 단순 긍정/부정: "응", "네", "ok", "okay"

다음의 경우에만 needs_tools=TRUE 로 설정한다:
- 서버/시스템 상태 조회 (CPU, 메모리, 디스크, 프로세스, 로그)
- 서버에서 명령 실행 또는 파일 관리
- 데이터베이스, 서비스, 컨테이너 조회 또는 변경
- 지식 검색/등록, SSH 서버 관리

후속 메시지 처리:
- 현재 입력이 짧은 연속 또는 확인이고, 최근 대화에서 이미 인프라 작업이 진행 중이었다면 해당 작업의 일부로 취급한다.
- 작업 연속 예시: "가능하니깐 해줘", "직접 해줘", "그대로 진행해", "그걸로 해" 등.
- 주변 컨텍스트가 명확히 운영 작업인 경우 이러한 후속 메시지를 일상 대화로 분류하지 않는다.

Examples:
- "하이?" → needs_tools: false, tier: fast
- "서버 목록 보여줘" → needs_tools: true, tool_groups: ["server_mgmt"], tier: fast
- "CPU 사용량 확인해줘" → needs_tools: true, tool_groups: ["system_info"], tier: general
- "oracle 서버 접속해줘" → needs_tools: true, tool_groups: ["server_mgmt"], tier: general
- "db 서버 접속해" → needs_tools: true, tool_groups: ["server_mgmt"], tier: general
- "oracle db서버 접속하고 AI26 인스턴스 접속해" → needs_tools: true, tool_groups: ["server_mgmt","connector"], tier: general
- "AI26 인스턴스 접속해줘" → needs_tools: true, tool_groups: ["server_mgmt","connector"], tier: general
- "oracle 인스턴스에 접속해" → needs_tools: true, tool_groups: ["server_mgmt","connector"], tier: general
- "sqlplus로 접속해줘" → needs_tools: true, tool_groups: ["connector"], tier: general
- "PDB 접속해" → needs_tools: true, tool_groups: ["server_mgmt","connector"], tier: general
- "nginx 설치해줘" → needs_tools: true, tool_groups: ["shell","connector"], tier: reasoning
- "왜 서비스가 죽었는지 분석해줘" → needs_tools: true, tool_groups: ["file_ops","shell"], tier: reasoning
- "결과 요약해줘" → needs_tools: false, tier: fast

## 도구 그룹
- system_info: OS 정보, CPU/메모리/디스크 사용량, 실행 중인 프로세스 조회
- file_ops: 파일 읽기/쓰기, 파일 전송, 로그 tail
- shell: 현재 포커스된 서버에서 셸 명령 실행
- network: 네트워크 인터페이스 정보, Kubernetes 클러스터 조회
- service_mgmt: 시스템 서비스 확인/시작/중지 (systemd 등)
- server_mgmt: SSH 서버 관리 (목록, 추가, 포커스); "서버 접속" 또는 "서버 전환" 요청에 사용
- connector: DB/서비스 연결/활성화; 사용자가 DB, PDB, 인스턴스 로그인 또는 sqlplus 사용을 명시적으로 요청할 때만 사용
- discovery: 서버 서비스 자동 탐지, 커넥터 유형 프로브
- knowledge: 지식 베이스 항목 검색/저장, RAG 문서 관리
- web: 웹 검색 및 URL 조회; 최신 정보, 공식 문서, 릴리스 노트, 출처 검증에 사용
- orchestration: 백그라운드 작업, 서브에이전트, 체크포인트, 스케줄링

If the request depends on current facts, version-sensitive behavior, or external verification, include the web tool group even if local knowledge or RAG also has an answer.
However, if the user explicitly asserts that something is already the latest or already verified (e.g. "최신이야", "이미 확인했어", "방금 받았어", "already the latest", "already checked"), do NOT include the web tool group — treat the user's statement as ground truth and proceed without web verification.

## Complexity Classification (IMPORTANT)

Complexity=complex 판정 기준 (다음 중 하나라도 해당하면 complex):
- 2단계 이상 순서가 있는 작업
- 파일/DB/서비스를 영구 변경(mutation)하는 작업
- 다중 서버 대상
- 서비스 재시작 또는 다운타임 포함
- install/patch/migrate/backup 키워드 포함

Complexity=simple: 단순 조회, 단일 명령, 상태 확인.

requires_task_proposal=true: Complexity=complex AND tier=reasoning일 때 반드시 true 설정.
→ 이 경우 LLM은 declare_task 직접 호출 금지. 반드시 propose_task를 먼저 호출해야 한다.

Use the 'classify_request' tool to specify your requirements.`

// shortChatPattern은 LLM 호출 없이 즉시 needs_tools=false로 판단할 수 있는 짧은 인사/잡담 패턴이다.
var shortChatPattern = regexp.MustCompile(`(?i)^(하이|안녕|hi|hello|hey|ㅎㅇ|ㅎㅎ|감사|고마워|thank(s| you)?|ㄱㅅ|넵|네|예|응|ㅇㅇ|ok|okay|bye|ㅂㅂ|잘자|잘가|수고|좋아|알겠어|알겠습니다|오케이|굿)[?!.\s]*$`)

// reasoningPattern은 LLM 분류 없이 reasoning 티어로 즉시 판단할 수 있는 키워드 패턴이다.
// 설치, 트러블슈팅, 분석, 계획 등 고난도 작업을 감지한다.
var reasoningPattern = regexp.MustCompile(`(?i)(` +
	`설치|install(ation)?|` +
	`트러블슈팅|troubleshoot|` +
	`디버그|debug(ging)?|` +
	`분석해|분석 해|analyze|analysis|` +
	`원인.*찾|root.?cause|` +
	`왜.*안|왜.*못|왜.*죽|왜.*안돼|왜.*실패|` +
	`why.*(not|fail|down|crash|error)|` +
	`어떻게.*해결|how.*(fix|solve|resolve)|` +
	`계획.*세|migration.*plan|plan.*migration|` +
	`아키텍처|architecture|` +
	`마이그레이션|migration|` +
	`장애|incident|outage|` +
	`성능.*개선|performance.*tun|` +
	`보안.*점검|security.*audit|` +
	`설정.*전략|config.*strategy|` +
	`구성.*방법|how.*configure|how.*setup` +
	`)`)

// complexityPattern은 rule-based complex 복잡도 힌트 감지를 위한 패턴이다.
// 설치·패치·마이그레이션·백업·업그레이드·멀티스텝·서비스 재시작 등을 감지한다.
var complexityPattern = regexp.MustCompile(`(?i)(` +
	`설치|install(ation)?|` +
	`패치|patch(ing)?|` +
	`마이그레이션|migrat(ion|e)|` +
	`백업|backup|` +
	`업그레이드|upgrade|` +
	`2단계|멀티스텝|multi.?step|` +
	`재시작.*서비스|서비스.*재시작|restart.*service|service.*restart|` +
	`데이터.*이전|data.*transfer` +
	`)`)

// fastPattern은 LLM 분류 없이 fast 티어로 즉시 판단할 수 있는 키워드 패턴이다.
// 단순 요약, 포맷팅, 목록 조회 등을 감지한다.
var fastPattern = regexp.MustCompile(`(?i)(` +
	`요약해|요약 해|summarize|summary|` +
	`정리해|정리 해|` +
	`표로.*만들|format.*table|make.*table|` +
	`json.*변환|yaml.*변환|convert.*to|` +
	`목록.*보여|show.*list|list.*show|` +
	`서버.*(추가|생성|접속|연결|전환|목록)|` +
	`workspace.*(추가|생성|접속|연결|전환|목록)|` +
	`뭐였|what was|무엇이었|` +
	`몇 개|how many|개수|count` +
	`)`)

// runSelfClassification은 사용자 요청에 필요한 도구·섹션·모델 티어를 결정한다.
//
// 분류 순서:
// 1. 인사/잡담 fast-path (LLM 없이 즉시 반환)
// 2. reasoning/fast 키워드 사전 감지 → tier 선결정
// 3. LLM 분류 (tool_groups, prompt_sections, tierHint 없으면 tier도)
// 4. tierHint가 있으면 LLM의 tier 판단을 오버라이드
func (a *Agent) runSelfClassification(ctx context.Context, userInput string, history ...llm.Message) (ClassifyResult, error) {
	trimmed := strings.TrimSpace(userInput)

	// 1단계: 인사/잡담 fast-path (LLM 호출 없이 즉시 반환)
	// 히스토리 유무와 무관하게 명확한 인사/잡담 패턴은 LLM 없이 즉시 판단한다.
	if len([]rune(trimmed)) <= 20 && shortChatPattern.MatchString(trimmed) {
		slog.Debug("fast-path classification: greeting/chat detected", "input", trimmed)
		llm.LogSystemEvent("Classification", "Fast-path triggered: greeting/chat detected.\nSelected Tier: fast\nNeedsTools: false")
		return ClassifyResult{NeedsTools: false, Tier: "fast"}, nil
	}

	// 2단계: 키워드 기반 tier 사전 감지 (규칙 기반)
	// tier만 선결정하고 tool_groups/prompt_sections는 LLM이 결정하도록 폴백에서 유지
	tierHint := ""
	if reasoningPattern.MatchString(trimmed) {
		tierHint = "reasoning"
		slog.Debug("rule-based tier hint: reasoning", "input", trimmed)
	} else if fastPattern.MatchString(trimmed) {
		tierHint = "fast"
		slog.Debug("rule-based tier hint: fast", "input", trimmed)
	}

	// rule-based complexity hint: LLM 호출 전에 미리 판정해 두고 LLM 결과를 보완한다.
	complexHint := complexityPattern.MatchString(trimmed)

	// 3단계: LLM 분류 (tool_groups, prompt_sections 결정)
	result, err := a.llmClassify(ctx, userInput, history...)
	if err != nil {
		slog.Warn("llm classification failed, using rule-based fallback", "err", err, "tier_hint", tierHint)
		result = classifyFallback(tierHint)
	}

	// 4단계: tierHint가 있으면 LLM의 tier 판단을 오버라이드
	if tierHint != "" && result.Tier != tierHint {
		slog.Debug("overriding llm tier with rule-based hint",
			"llm_tier", result.Tier, "rule_tier", tierHint)
		result.Tier = tierHint
	}

	// 5단계: rule-based complexity 폴백 적용
	if complexHint && result.Complexity == "" {
		result.Complexity = "complex"
	}
	if result.Complexity == "complex" && result.Tier == "reasoning" {
		result.RequiresTaskProposal = true
	}

	if applyWebSearchHints(&result, trimmed) {
		slog.Debug("rule-based web hint applied", "input", trimmed, "groups", result.ToolGroups, "sections", result.PromptSections)
	}

	// reasoning-tier 는 pre-flight intel 서브에이전트 실행을 위해 task_type 이 반드시 필요하다.
	// 분류 모델이 task_type 을 누락하면 사용자 입력에서 재추론하고, 실패 시 plan 으로 안전 폴백한다.
	if result.Tier == "reasoning" && strings.TrimSpace(result.TaskType) == "" {
		taskType := classifyTaskType(trimmed)
		inferredFromInput := taskType != ""
		if taskType == "" {
			taskType = TaskTypePlan
		}
		result.TaskType = string(taskType)
		slog.Debug("normalized reasoning task_type",
			"inferred", result.TaskType,
			"from_input", inferredFromInput,
		)
	}

	return result, nil
}

// llmClassify는 LLM을 통해 분류 결과를 얻는다.
// fast 모델이 등록된 경우 fast를 우선 사용하고, 없으면 general로 폴백한다.
func (a *Agent) llmClassify(ctx context.Context, userInput string, history ...llm.Message) (ClassifyResult, error) {
	classifyTier := "general"
	if a.llmRegistry != nil && a.llmRegistry.Has(llm.TierFast) {
		classifyTier = "fast"
	}
	client, _, modelName := a.resolveClientForTier(classifyTier)
	client = classificationClient(client)

	prompt := buildClassificationPrompt(userInput, history)
	messages := []llm.Message{
		{Role: llm.RoleSystem, Content: classifySystemPrompt},
		{Role: llm.RoleUser, Content: prompt},
	}

	toolDefs := []llm.ToolDef{
		{
			Type: "function",
			Function: llm.FunctionDef{
				Name:        "classify_request",
				Description: "현재 요청에 필요한 도구, 컨텍스트 섹션을 로드하고 실행 모델을 선택한다.",
				Parameters: map[string]any{
					"type": "object",
					"properties": map[string]any{
						"needs_tools": map[string]any{
							"type":        "boolean",
							"description": "요청 처리에 도구가 필요하면 true. 인사말, 잡담, 감사 표현, 단순 대화는 false.",
						},
						"tool_groups": map[string]any{
							"type": "array",
							"items": map[string]any{
								"type": "string",
								"enum": []string{
									"system_info", "file_ops", "shell", "network",
									"service_mgmt", "discovery", "knowledge", "web",
									"server_mgmt", "connector", "orchestration",
								},
							},
						},
						"prompt_sections": map[string]any{
							"type": "array",
							"items": map[string]any{
								"type": "string",
								"enum": []string{
									"safety", "error_recovery", "grounding",
									"tool_priority", "tool_selection", "task_completion",
									"phase_planning", "discovery", "rag", "behavior",
									"servers", "connectors", "learned_systems",
								},
							},
						},
						"tier": map[string]any{
							"type":        "string",
							"description": "작업 복잡도에 따라 실행 LLM 티어를 선택한다.",
							"enum":        []string{"fast", "general", "reasoning"},
						},
						"task_type": map[string]any{
							"type":        "string",
							"description": "tier=reasoning일 때 필수. reasoning 작업 유형을 분류한다.",
							"enum":        []string{"install", "troubleshoot", "configure", "analyze", "migrate", "plan"},
						},
						"complexity": map[string]any{
							"type":        "string",
							"enum":        []string{"simple", "complex"},
							"description": "작업 복잡도. 2단계 이상·mutation·서비스 재시작·install·migrate 등이면 complex.",
						},
						"requires_task_proposal": map[string]any{
							"type":        "boolean",
							"description": "complexity=complex AND tier=reasoning일 때 true. propose_task를 먼저 호출해야 한다.",
						},
						"reasoning": map[string]any{
							"type":        "string",
							"description": "해당 도구·모델을 선택한 이유.",
						},
					},
					"required": []string{"needs_tools", "tier", "reasoning"},
				},
			},
		},
	}

	toolChoice := map[string]any{
		"type":     "function",
		"function": map[string]any{"name": "classify_request"},
	}

	resp, err := client.Chat(ctx, messages, toolDefs, toolChoice)
	if err != nil {
		return ClassifyResult{}, err
	}

	if a.costTracker != nil {
		a.costTracker.Record(ctx, modelName, resp.InputTokens, resp.OutputTokens, cost.SourceClassify, a.currentSessionID)
	}

	if len(resp.ToolCalls) == 0 {
		slog.Warn("classify_request tool not called", "content_preview", truncateClassifyContent(resp.Content, 200))
		llm.LogSystemEvent("Classification", "No classify_request tool call. Escalating to rule-based fallback.")
		return ClassifyResult{}, fmt.Errorf("classify_request tool not called")
	}

	var result ClassifyResult
	if err := json.Unmarshal([]byte(resp.ToolCalls[0].Function.Arguments), &result); err != nil {
		return ClassifyResult{}, fmt.Errorf("parse classification result: %w", err)
	}

	reasoning := getReasoningFromRaw(resp.ToolCalls[0].Function.Arguments)
	llm.LogSystemEvent("Classification", fmt.Sprintf(
		"Selected Tier: %s\nNeedsTools: %v\nGroups: %v\nSections: %v\nReasoning: %s",
		result.Tier, result.NeedsTools, result.ToolGroups, result.PromptSections, reasoning,
	))

	slog.Info("LLM self-judgment", "needs_tools", result.NeedsTools, "groups", result.ToolGroups,
		"sections", result.PromptSections, "tier", result.Tier, "task_type", result.TaskType)
	return result, nil
}

// classifyFallback은 LLM 분류 실패 시 tierHint를 기반으로 안전한 기본값을 반환한다.
func classifyFallback(tierHint string) ClassifyResult {
	tier := "general"
	if tierHint != "" {
		tier = tierHint
	}
	return ClassifyResult{
		NeedsTools:     true,
		ToolGroups:     []string{"shell", "system_info", "server_mgmt", "file_ops"},
		PromptSections: []string{"safety", "tool_priority", "tool_selection"},
		Tier:           tier,
	}
}

func getReasoningFromRaw(raw string) string {
	var parsed struct {
		Reasoning string `json:"reasoning"`
	}
	_ = json.Unmarshal([]byte(raw), &parsed)
	return parsed.Reasoning
}

func buildClassificationPrompt(userInput string, history []llm.Message) string {
	var recent []llm.Message
	for i := len(history) - 1; i >= 0; i-- {
		msg := history[i]
		if msg.Role == llm.RoleSystem {
			continue
		}
		if msg.Role == llm.RoleUser && strings.TrimSpace(msg.Content) == strings.TrimSpace(userInput) {
			continue
		}
		recent = append(recent, msg)
		if len(recent) >= 6 {
			break
		}
	}

	var sb strings.Builder
	sb.WriteString("이 작업을 분류하세요 (reasoning/general/fast 중 하나로 응답):\n")
	sb.WriteString("현재 사용자 입력:\n")
	sb.WriteString(strings.TrimSpace(userInput))

	if len(recent) > 0 {
		sb.WriteString("\n\n최근 대화 컨텍스트:\n")
		for i := len(recent) - 1; i >= 0; i-- {
			msg := recent[i]
			role := "어시스턴트"
			if msg.Role == llm.RoleUser {
				role = "사용자"
			}
			sb.WriteString(role)
			sb.WriteString(": ")
			sb.WriteString(strings.TrimSpace(msg.Content))
			sb.WriteString("\n")
		}
	}

	return sb.String()
}

func truncateClassifyContent(content string, maxLen int) string {
	content = strings.TrimSpace(content)
	if len(content) <= maxLen {
		return content
	}
	if maxLen <= 3 {
		return content[:maxLen]
	}
	return content[:maxLen-3] + "..."
}

func classificationClient(client llm.Client) llm.Client {
	if configurable, ok := client.(llm.InlineToolCallModeClient); ok {
		return configurable.WithInlineToolCalls(false)
	}
	return client
}
