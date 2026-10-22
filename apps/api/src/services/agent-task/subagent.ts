/**
 * Agent Task 서브에이전트 위임 (Phase 5-1).
 *
 * delegate 도구를 1-shot 자문에서 **depth=1 미니 tool-loop** 로 승격한다 — 서브에이전트가
 * 전문가 페르소나 + 안전 도구 서브셋(호스트 화이트리스트, 예: web_search)으로 하위 목표를
 * 실제 수행하고 결과를 반환한다. (SUBAGENT_ENABLED off 면 기존 1-shot 유지.)
 *
 * 폭주 가드(설계 원칙 — 재귀·비용 차단):
 *  - depth 1 고정: 서브에이전트 도구 목록에 delegate 없음(재위임 구조적 불가).
 *  - 턴 상한 SUBAGENT_MAX_TURNS(기본 3) · 위임당 토큰 상한 SUBAGENT_MAX_TOKENS.
 *  - 토큰은 onTokens 로 부모 totalTokens 에 합산 — 부모 runaway 가드도 함께 적용.
 *  - 도구는 부모와 동일한 HITL 승인 게이트 경유(정책 우회 없음) — 자동승인 task 면 즉시.
 *  - 샌드박스(쓰기) 도구는 제외 — 부모 컨테이너 상태를 서브가 변경하지 못함.
 *
 * @module services/agent-task/subagent
 */
import type { LLMClient } from '../../llm';
import type { ChatMessage, ToolCall, ToolDefinition, UsageMetrics } from '../../llm/types';
import { getToolRuntime } from '../../runtime-ports/tool-runtime';
import type { UserContext } from '../../tool-contract/types';
import type { TaskSandboxConfig } from '../../config/task-sandbox';
import { AGENT_TASK_LIMITS } from '../../config/runtime-limits';
import { requiresApproval, getApprovalRegistry } from '../task-sandbox/approval-gate';
import { runWithCostSession } from '../../utils/cost-attribution-context';
import { runTool } from './task-steps';
import { prefetchReadOnlyCalls } from '../tool-parallel';
import type { SubagentTrace } from './subagent-trace';
import { AgentTaskParked } from './types';
import { findDanglingToolCalls } from './turn-reentry';
import { createLogger } from '../../utils/logger';
import { detectLanguage, LANGUAGE_DISPLAY_NAMES } from '../../chat/language-policy';
import { buildSubagentDelegationRules, SUBAGENT_FINAL_TURN_NOTICE, partialSubagentResult } from '../../prompts/subagent-system';
import { getApprovalRejectedNotice } from '../../prompts/agent-task-approval';
import { prepareToolArgs } from './tool-args';
import { exitReasonForError, type SubagentExitReason } from '../../config/agent-task-delegation';

const logger = createLogger('AgentTaskSubagent');

/** qwen 이 도구 없는 최종 턴에 raw <tool_call> XML 을 텍스트로 뱉는 결함 정리 —
 *  XML 만 남으면 빈 문자열이 되어 호출부의 명시적 실패 문구로 대체된다. */
function stripRawToolCallXml(text: string): string {
    return text.replace(/<tool_call>[\s\S]*?(<\/tool_call>|$)/g, '').trim();
}

interface SubagentParams {
    client: LLMClient;
    /** 전문가 페르소나 system prompt (keyword-router 가 고른 산업 agent). */
    personaPrompt: string;
    subgoal: string;
    /** 안전 도구 서브셋 — 부모의 호스트 화이트리스트(extraTools). delegate 류는 호출부가 제외. */
    tools: ToolDefinition[];
    userCtx: UserContext;
    /** 승인 레지스트리 키(에이전트 작업 taskId). 채팅 경로는 승인 게이트를 건너뛰어(skipApprovalGate) 실사용 안 됨. */
    taskId: string;
    /** 승인 정책·대기 상한만 사용. skipApprovalGate — 채팅 경로만 true: 승인 게이트를 아예 거치지 않는다
     *  (정책 none 의 바닥 거절도 적용하지 않는다 — 채팅 부모 루프가 같은 도구를 게이트 없이 부른다, 2026-10-22 S1). */
    sandboxCfg: Pick<TaskSandboxConfig, 'approvalPolicy' | 'approvalTimeoutMs' | 'deviceGatesShell'> & { skipApprovalGate?: boolean };
    signal?: AbortSignal;
    /** 서브 LLM 호출 토큰을 부모 누적에 합산. */
    onTokens?: (n: number, metrics?: UsageMetrics) => void;
    /** 부모 작업의 남은 토큰 예산 — 0 이하가 되면 다음 턴으로 가지 않는다(형제 서브의 사용분도 onTokens 로 반영된 값). */
    remainingTokens?: () => number;
    /** 승인 대기 시간을 부모 pausedMs 에 합산(4-1 pause-aware 일관). */
    onPausedMs?: (ms: number) => void;
    /** 활동 기록(109) — 에이전트 작업 경로만 넘긴다. 채팅 경로는 작업 행이 없어 무기록. */
    trace?: SubagentTrace;
    /**
     * 승인 주차(173) — 에이전트 작업의 delegate 경로만 넘긴다. 승인 대기가 유예를 넘기면 대화를 save 로 남기고
     * AgentTaskParked 를 던져 부모가 delegate 호출 지점에서 주차된다. restored 가 있으면 그 대화에서 이어간다.
     */
    park?: { restored?: SubagentResumeState; save: (state: SubagentResumeState) => Promise<void> };
    /** 승인이 대기에 들어감 — delegate 경로만 넘긴다(부모 작업 paused + 알림, 부모 턴의 승인과 같은 발행). */
    onApprovalPending?: (toolName: string) => void;
    /** 그 대기가 유예 안에 결정(승인·거절)됨 — 부모 작업을 running 으로 되돌린다. 주차되면 부르지 않는다. */
    onApprovalDecided?: () => void;
    /** 종료 사유 — 결과 문자열을 돌려주기 직전에 한 번 부른다. 주차(AgentTaskParked)는 종료가 아니라 부르지 않는다. */
    onExit?: (reason: SubagentExitReason) => void;
    /** 최종 답 검사 — 교정 요청문을 돌려주면 그 문장을 대화에 싣고 도구 없이 한 번만 더 부른다. null 이면 그대로 끝낸다. */
    finalCheck?: (text: string) => string | null;
}

/** 주차된 서브에이전트의 재개 지점 — 결과 없는 tool_call 로 끝나는 대화 + 그 턴·누적 토큰. */
export interface SubagentResumeState {
    conversation: ChatMessage[];
    turn: number;
    tokens: number;
}

/**
 * depth=1 미니 tool-loop 실행 — 최종 텍스트 반환. 실패는 문자열로 흡수(부모 luoop 를 죽이지 않음).
 */
export async function runSubagent(p: SubagentParams): Promise<string> {
    const maxTurns = AGENT_TASK_LIMITS.SUBAGENT_MAX_TURNS;
    const mcp = getToolRuntime();
    const restored = p.park?.restored;
    let tokens = restored?.tokens ?? 0;

    // role-client.ts 의 부모 턴과 같은 이유 — 기본 LLM_TIMEOUT(120s)은 채팅용이라,
    // 서브의 마지막 턴(도구 없이 장문 최종 답변)이 넘기면 "Request timed out" 으로 죽는다.
    // 실제 한계는 p.signal(상위 잔여 예산)이 governor 다.
    // maxRetries 0: 타임아웃을 SDK 가 맹목 재시도하면 같은 조건에서 또 실패하면서
    // 모델 슬롯만 3배로 점유해 동시 실행 중인 다른 서브까지 함께 느려진다
    // (external-throttle.ts 가 외부 provider 에 같은 이유로 0 을 쓴다).
    // 외부 role 클라이언트가 이미 더 긴 timeout 을 들고 있으면 그쪽을 존중한다.
    const client = p.client.derive({
        timeout: Math.max(p.client.requestTimeout, AGENT_TASK_LIMITS.SCHEDULE_TOTAL_TIMEOUT_MS),
        maxRetries: 0,
    });

    const conversation: ChatMessage[] = restored ? [...restored.conversation] : [
        {
            role: 'system',
            content: p.personaPrompt + '\n\n' + buildSubagentDelegationRules(maxTurns, p.tools.map((t) => t.function.name), LANGUAGE_DISPLAY_NAMES[detectLanguage(p.subgoal).language]),
        },
        { role: 'user', content: p.subgoal },
    ];
    // 재개: 저장된 턴은 LLM 을 다시 부르지 않고 결과 없는 호출만 이어서 실행한다(이미 끝난 호출은 대화에 결과가 있다).
    let resumeCalls: ToolCall[] | null = restored ? (findDanglingToolCalls(conversation)?.calls ?? null) : null;
    /** 승인 대기가 유예를 넘김 → 대화를 남기고 부모 주차. 저장 실패는 주차를 막지 않는다(재개 때 처음부터). */
    const parkHere = async (turn: number, toolName: string): Promise<never> => {
        p.trace?.record('parked', toolName); // 저장 전에 남긴다 — 체크포인트의 다음 순번에 포함
        await p.park!.save({ conversation, turn, tokens })
            .catch((e) => logger.warn(`[Subagent] 주차 대화 저장 실패 — 재개 때 처음부터 다시: ${e instanceof Error ? e.message : e}`));
        throw new AgentTaskParked();
    };

    if (restored) p.trace?.record('resumed', '');

    try {
        for (let turn = restored?.turn ?? 0; turn < maxTurns; turn++) {
            if (p.signal?.aborted) { p.onExit?.('error'); return 'Error: 상위 작업이 중단되었습니다.'; }
            const toolCalls = resumeCalls ?? await llmTurn(turn);
            resumeCalls = null;
            if (typeof toolCalls === 'string') return toolCalls;
            await runCalls(toolCalls, turn);
        }
        // 턴 소진 — 마지막 assistant 내용 반환.
        const last = [...conversation].reverse().find((m) => m.role === 'assistant');
        const exhausted = stripRawToolCallXml((last?.content as string) || '') || '(서브에이전트가 턴 상한에 도달했습니다)';
        p.trace?.record('final', `[턴 상한 도달] ${exhausted}`);
        p.onExit?.('turns');
        return partialSubagentResult('turns', exhausted);
    } catch (e) {
        if (e instanceof AgentTaskParked) throw e; // 주차는 실패가 아니다 — 부모가 받아 주차한다
        const msg = e instanceof Error ? e.message : String(e);
        p.trace?.record('error', msg);
        logger.warn(`[Subagent] 실행 실패: ${msg}`);
        p.onExit?.(exitReasonForError(msg));
        return `Error: 서브에이전트 실행 실패 — ${msg}`;
    }

    /** LLM 1턴 — 도구 호출이 있으면 그 목록, 없으면(또는 상한) 최종 텍스트. */
    async function llmTurn(turn: number, correcting = false): Promise<ToolCall[] | string> {
        {
            // 마지막 턴엔 도구를 제거해 최종 답변을 강제(도구 호출로 끝나 결과가 없는 상황 방지).
            const lastTurn = turn === maxTurns - 1;
            // 마지막 턴 진입을 모델에게 명시 — 안내문·배경은 prompts/subagent-system.ts 참고.
            if (!correcting && lastTurn && turn > 0 && p.tools.length > 0) {
                conversation.push({ role: 'user', content: SUBAGENT_FINAL_TURN_NOTICE });
            }
            // 원장 귀속 — 부모 작업의 id 로 묶는다. 채팅 경로의 식별용 가짜 id(`__…__`)는 작업이 아니므로 싣지 않는다.
            const callLlm = () => client.chat(conversation, undefined, undefined, {
                tools: correcting || lastTurn || p.tools.length === 0 ? undefined : p.tools,
                signal: p.signal,
                think: false,
                requestClass: 'fanout',
            });
            const result = await (p.taskId.startsWith('__') ? callLlm() : runWithCostSession(p.taskId, callLlm));
            const used = (result.metrics?.prompt_tokens ?? 0) + (result.metrics?.completion_tokens ?? 0);
            tokens += used;
            p.onTokens?.(used, result.metrics);
            // 위임당 고정 상한 + 부모 잔여 — 종전엔 서브가 부모의 남은 예산과 무관하게 고정 상한까지 썼다.
            if (tokens > AGENT_TASK_LIMITS.SUBAGENT_MAX_TOKENS || (p.remainingTokens !== undefined && p.remainingTokens() <= 0)) {
                logger.warn(`[Subagent] 토큰 상한 초과 — 조기 종료 (${tokens})`);
                p.trace?.record('final', `[토큰 상한 ${tokens}] ${result.content || '(부분 결과 없음)'}`);
                p.onExit?.('tokens');
                return partialSubagentResult('tokens', result.content || '');
            }

            conversation.push({
                role: 'assistant',
                content: result.content,
                ...(result.tool_calls && { tool_calls: result.tool_calls }),
            });
            if (correcting || !result.tool_calls || result.tool_calls.length === 0) {
                const finalText = stripRawToolCallXml(result.content || '');
                const correction = correcting ? null : p.finalCheck?.(finalText);
                if (correction) {
                    conversation.push({ role: 'user', content: correction });
                    return llmTurn(turn, true);
                }
                p.trace?.record('final', finalText || '(빈 응답)');
                p.onExit?.('completed');
                return finalText || '(서브에이전트가 빈 응답을 반환했습니다)';
            }
            for (const tc of result.tool_calls) {
                // 활동 기록에는 민감 키를 가린 인자를 남긴다(부모 경로의 스텝 기록과 같은 기준).
                p.trace?.record('tool_call', JSON.stringify(prepareToolArgs(tc.function.arguments ?? {})), tc.function.name);
            }
            return result.tool_calls;
        }
    }

    /** 도구 호출 실행 — 승인이 주차되면 그 호출 앞에서 대화를 남기고 던진다. */
    async function runCalls(calls: ToolCall[], turn: number): Promise<void> {
        {
            const result = { tool_calls: calls };
            // 읽기 전용 도구 병렬 선실행 — 승인 필요 호출은 자동 승인 작업에서만(부모 루프와 같은 규칙).
            const prefetched = await prefetchReadOnlyCalls(
                result.tool_calls.map((tc) => ({ id: tc.id, name: tc.function.name, tc })),
                ({ name, tc }) => !!p.sandboxCfg.skipApprovalGate || !requiresApproval(p.sandboxCfg.approvalPolicy, name,
                    (tc.function.arguments ?? {}) as Record<string, unknown>, { deviceGatesShell: p.sandboxCfg.deviceGatesShell })
                    || getApprovalRegistry().autoApproves(p.taskId, name, (tc.function.arguments ?? {}) as Record<string, unknown>),
                async ({ name, tc }) => {
                    const args = (tc.function.arguments ?? {}) as Record<string, unknown>;
                    if (!p.sandboxCfg.skipApprovalGate && requiresApproval(p.sandboxCfg.approvalPolicy, name, args, { deviceGatesShell: p.sandboxCfg.deviceGatesShell })) {
                        const r = await getApprovalRegistry().request(
                            { taskId: p.taskId, userId: String(p.userCtx.userId), toolName: name, args },
                            { timeoutMs: p.sandboxCfg.approvalTimeoutMs, signal: p.signal, policy: p.sandboxCfg.approvalPolicy },
                        );
                        p.onPausedMs?.(r.waitedMs);
                        if (r.decision !== 'approved') return getApprovalRejectedNotice(name, r.reason, r.text);
                    }
                    return runTool(mcp, name, args, p.userCtx, undefined, p.signal);
                },
                { path: 'subagent', ...(p.signal ? { signal: p.signal } : {}) },
            );
            for (const tc of result.tool_calls) {
                const name = tc.function.name;
                const args = (tc.function.arguments ?? {}) as Record<string, unknown>;
                const pre = tc.id !== undefined ? prefetched.get(tc.id) : undefined;
                if (pre !== undefined) {
                    p.trace?.record('tool_result', pre, name);
                    conversation.push({ role: 'tool', content: pre, tool_name: name, tool_call_id: tc.id });
                    continue;
                }
                // 부모와 동일한 승인 게이트 — 정책 우회 없음(자동승인 task 면 즉시 approved).
                let approved = true;
                let rejected: { reason?: string; text?: string } = {};
                if (!p.sandboxCfg.skipApprovalGate && requiresApproval(p.sandboxCfg.approvalPolicy, name, args, { deviceGatesShell: p.sandboxCfg.deviceGatesShell })) {
                    let pended = false;
                    const r = await getApprovalRegistry().request(
                        { taskId: p.taskId, userId: String(p.userCtx.userId), toolName: name, args },
                        {
                            timeoutMs: p.sandboxCfg.approvalTimeoutMs, signal: p.signal, parkable: !!p.park, policy: p.sandboxCfg.approvalPolicy,
                            // 대기 진입 — 활동 기록에 awaiting(유예 구간도 "승인 대기"로 보이게) + 부모 paused·알림.
                            ...(p.onApprovalPending || p.trace ? { onPending: (pa) => {
                                pended = true;
                                p.trace?.record('awaiting', JSON.stringify(prepareToolArgs(args)), name);
                                p.onApprovalPending?.(pa.toolName);
                            } } : {}),
                        },
                    );
                    p.onPausedMs?.(r.waitedMs);
                    if (r.reason === 'parked' && p.park) await parkHere(turn, name);
                    if (pended) { p.trace?.record('resumed', ''); p.onApprovalDecided?.(); }
                    approved = r.decision === 'approved';
                    rejected = r;
                }
                const toolResult = approved
                    ? await runTool(mcp, name, args, p.userCtx, undefined, p.signal)
                    : getApprovalRejectedNotice(name, rejected.reason, rejected.text);
                p.trace?.record('tool_result', toolResult, name);
                conversation.push({ role: 'tool', content: toolResult, tool_name: name, tool_call_id: tc.id });
            }
        }
    }
}
