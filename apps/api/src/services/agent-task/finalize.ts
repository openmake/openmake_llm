/**
 * Agent Task 완료 관문 — 모든 완료 출구가 지나는 단일 판정 지점 (091).
 *
 * 종전엔 completed 로 나가는 출구가 둘이었고 판정 강도가 서로 달랐다:
 *   ① 도구 없는 최종 답변 — 마커 → judge(아티팩트 0 한정) → verify
 *   ② terminate 도구      — **판정 없음**, 아티팩트만 영속하고 즉시 completed
 * 2026-08-09 후향 실측(completed 155건)에서 ②가 22건(14.2%)이고 전부 아티팩트 0,
 * 평균 결과 길이 139자였다. 빈 terminate 로 산출물 없이 completed 되는 것이 라이브에서
 * 재현되기도 했다(2026-08-06). 두 출구를 이 모듈로 모아 같은 관문을 지나게 한다.
 *
 * 판정 순서는 **결정적 검사 → LLM 판정** 이다. 코드가 깨졌으면 목표 달성 여부를 물을 것
 * 없이 자가수정 루프로 돌려보내는 편이 싸고 정확하다(실행 grounding > self-critique).
 *   1. `[GOAL_INCOMPLETE]` 자기신고 → 실행 증거가 있으면 후단 판정과 대조, 없으면 failed(goal_incomplete)
 *   2. deliverable verify(코드 산출물 문법/컴파일) → 실패 시 자가수정 유도로 반환
 *   3. goal judge(LLM 1회) → 미달성 확정 시 failed(goal_incomplete), 판정 실패는 fail-open
 *   4. 아티팩트·코드 diff 영속 → completed
 *
 * 파일 도구를 쓴 작업은 실제 파일 목록과 대조하며, 보고서 아티팩트가 있어도 판정을 적용한다.
 * 그 밖의 아티팩트가 있는 완료도 2026-08-27 부터
 * 셰도우로 판정만 돌려 기록한다(`judge_shadow` 스텝) — 확대 여부를 가를 오판율을 재려면
 * 표본이 필요하고, 적용 조건으로는 completed 의 18% 만 판정을 거치기 때문이다. 적용 확대는
 * 그 표본으로 오판율을 재측정한 뒤 결정한다.
 *
 * @module services/agent-task/finalize
 */
import type { getUnifiedDatabase } from '../../data/models/unified-database';
import { AGENT_TASK_LIMITS } from '../../config/runtime-limits';
import { extractAndStripArtifacts } from '../../llm/artifact-parser';
import { applyReportRender } from '../chat-service/report-block';
import { AGENT_TASK_INCOMPLETE_MARKER, getAgentTaskVerifyFailedNudge, getAgentTaskTestsFailedNudge } from '../../prompts/agent-task-prompt';
import { getVerifyHeldAnswerNote } from '../../prompts/agent-task-turn-loop';
import { AGENT_TASK_TURN_LOOP } from '../../config/agent-task-turn-loop';
import { judgeGoal, buildJudgeExecutionContext, buildJudgeArtifactSummary, withUserRejectionsJudgeNote, withWorkspaceJudgeNote, type JudgeUserRejection } from './goal-judge';
import { AgentTaskApprovalRepository } from '../../data/repositories/agent-task-approval-repository';
import { getPool } from '../../data/models/unified-database';
import { verifyCodeArtifacts } from './deliverable-verify';
import { verifyWorkspaceTests } from './workspace-test-verify';
import { persistArtifactSteps, persistJudgeStep, persistVerifySkippedStep, verifySkippedMessage } from './task-steps';
import { maybePersistCodeDiff } from './code-diff';
import { judgeClientFor } from './role-client';
import { withWriteFailureFootnote } from './write-failure-footnote';
import { withSandboxUnavailableFootnote, withSandboxUnavailableJudgeNote } from './sandbox-unavailable';
import { collectVerificationEvidence } from './verification-evidence';
import { FILE_MUTATING_CALLS, VERIFY_EVIDENCE } from '../../config/agent-task-tools';
import { VERIFY_EVIDENCE_SKIP_NOTES } from '../../prompts/agent-task-tools';
import { runWithCostSession } from '../../utils/cost-attribution-context';
import { createLogger } from '../../utils/logger';
import type { TaskRuntime } from '../task-sandbox/runtime';
import type { TaskSandboxConfig } from '../../config/task-sandbox';
import type { ChatMessage } from '../../llm/types';

const logger = createLogger('AgentTaskService');

type UnifiedDb = ReturnType<typeof getUnifiedDatabase>;
type AgentTaskUpdatePayload = Parameters<UnifiedDb['updateAgentTask']>[1];

/** 완료 관문을 지난 출구 구분 — 091 관측 컬럼 `agent_tasks.completion_path`. */
export type CompletionPath = 'final_answer' | 'terminate';
/** goal judge 결과 — 091 관측 컬럼 `agent_tasks.judge_verdict`. */
type JudgeVerdict = 'achieved' | 'not_achieved' | 'unknown' | 'skipped';

export interface FinalizeInput {
    taskId: string;
    goal: string;
    userId: string;
    /** 어느 출구로 도달했는지 — 판정 로직은 동일하고 관측에만 쓰인다. */
    path: CompletionPath;
    /** 모델 최종 응답 원문(아티팩트 추출 전). */
    rawContent: string;
    /** terminate 도구의 summary 인자 — 있으면 결과 본문으로 우선한다. */
    terminateSummary?: string;
    taskRuntime: TaskRuntime | null;
    sandboxCfg: TaskSandboxConfig;
    /** 실행 중 사용한 도구 — judge 실행 컨텍스트. */
    usedTools: ReadonlySet<string>;
    /** 최근 도구 실행 결과 요약(buildJudgeToolEvidence) — judge false negative 완화용 수행 증거. */
    toolEvidence?: string;
    /** 작업 대화 — 도구 호출 기록에서 끝까지 실패한 파일 쓰기를 찾는다(write-failure-footnote). 없으면 생략. */
    conversation?: readonly ChatMessage[];
    /** 0-base 턴 인덱스. */
    turn: number;
    stepNumber: number;
    /** 지금까지의 verify 자가수정 횟수 — 상한 초과 시 검증을 건너뛴다(무한루프 방지). */
    verifyRetries: number;
    signal: AbortSignal;
    update: (u: AgentTaskUpdatePayload) => Promise<void>;
    emitStep: (stepType: string, toolName?: string, content?: string | null) => void;
    /** 검증 실패로 되돌려 보낼 때 이 답변을 여기에 들고 있는다 — 턴 상한에 걸리면 finalizeMaxTurnsExhausted 가 쓴다. */
    hold?: VerifyHold;
    /** 들고 있던 답변을 턴 상한에서 꺼내 쓰는 호출 — 실패했던 검증을 다시 돌리지 않고 "검증 미통과"로 표시해 완료한다. */
    verifyHeld?: boolean;
}

/** 검증이 보류한 답변 — 턴 루프가 소유하고 완료 관문이 제자리 갱신한다(가장 최근 것만 남는다). */
export interface VerifyHold {
    answer?: FinalizeInput;
}

type FinalizeOutcome =
    /** 완료 처리까지 끝냈다 — 호출부는 즉시 종료한다. */
    | { kind: 'completed'; stepNumber: number }
    /** 목표 미달성으로 failed 기록까지 끝냈다 — 호출부는 즉시 종료한다. */
    | { kind: 'goal_incomplete'; stepNumber: number }
    /** 산출물 검증 실패 — 호출부가 nudge 를 conversation 에 넣고 루프를 계속한다. */
    | { kind: 'verify_retry'; stepNumber: number; nudge: string };

/**
 * 완료 판정 관문. 상태 갱신(completed/failed)까지 이 함수가 수행하고, 호출부는 반환 kind 로
 * 종료/계속만 결정한다. judge·verify 는 모두 fail-open 이라 판정 인프라 장애가 완료를 막지 않는다.
 */
/**
 * 턴 상한 도달 — **완주가 아니다**. terminate 경로와 달리 모델이 작업을 끝냈다고 선언한 적이 없고
 * 마지막 턴이 문장 중간에서 끊기는 것이 보통이다. 종전에는 completed·progress 100·checkpoint null 로
 * 기록해 ① 빈/절단 결과가 "완료"로 표시되고 ② resumable 이 false 라 이어할 수조차 없었다
 * (2026-08-02 실측). goal judge 와 같은 원칙으로 failed 로 기록하고 체크포인트를 남겨 이어하기를 연다
 * (마지막 end-of-turn checkpoint 는 루프가 저장했다). 2026-08-03 마무리 턴 도입 뒤 이 경로는 드물다 —
 * 마무리 턴에서도 도구를 부르거나 응답이 비었다는 뜻이라 failed 가 맞다.
 */
export async function finalizeMaxTurnsExhausted(p: {
    taskId: string; userId: string; turnCeiling: number; conversation: ChatMessage[];
    taskRuntime: TaskRuntime | null; sandboxCfg: TaskSandboxConfig; stepNumber: number;
    update: FinalizeInput['update']; emitStep: FinalizeInput['emitStep'];
    /** 검증이 보류한 직전 완성 답변 — 있으면 버리지 않고 미검증 완료로 남긴다(판정·산출물 영속은 완료 관문 그대로). */
    held?: FinalizeInput;
}): Promise<void> {
    if (p.held && AGENT_TASK_TURN_LOOP.KEEP_HELD_ANSWER) {
        logger.info(`[AgentTask] 턴 상한 도달 — 검증이 보류한 답변을 결과로 사용: ${p.taskId} (${p.turnCeiling} 턴)`);
        await finalizeTask({ ...p.held, stepNumber: p.stepNumber, hold: undefined, verifyHeld: true });
        return;
    }
    const lastAssistant = [...p.conversation].reverse().find((m) => m.role === 'assistant');
    const lastRaw = (lastAssistant?.content as string) || '(최대 턴에 도달하여 종료되었습니다.)';
    const lastExtracted = extractAndStripArtifacts(applyReportRender(lastRaw));
    const stepNumber = await persistArtifactSteps(p.taskId, lastExtracted.artifacts, p.stepNumber, p.userId);
    await maybePersistCodeDiff(p.taskRuntime, p.sandboxCfg, p.taskId, stepNumber, p.emitStep);
    await p.update({ status: 'failed', error: 'max_turns_exhausted', result: lastExtracted.cleanedContent || lastRaw });
    logger.warn(`[AgentTask] 턴 상한 종료(미완주): ${p.taskId} (${p.turnCeiling} 턴) — 재개하려면 max_turns 를 올려 resume 하세요.`);
}

export async function finalizeTask(input: FinalizeInput): Promise<FinalizeOutcome> {
    const {
        taskId, goal, userId, path, rawContent, terminateSummary,
        taskRuntime, sandboxCfg, usedTools, toolEvidence, turn, signal, update, emitStep,
    } = input;
    let stepNumber = input.stepNumber;

    const extracted = extractAndStripArtifacts(applyReportRender(rawContent ?? ''));
    const artifacts = extracted.artifacts;
    // terminate 는 summary 를 결과 본문으로 우선(도구 인자가 곧 모델의 완료 선언).
    const rawBody = path === 'terminate'
        ? (terminateSummary || extracted.cleanedContent || '작업을 완료했습니다.')
        : extracted.cleanedContent;
    const selfReportedIncomplete = rawBody.includes(AGENT_TASK_INCOMPLETE_MARKER);
    const body = selfReportedIncomplete ? rawBody.replace(AGENT_TASK_INCOMPLETE_MARKER, '').trim() : rawBody;
    // C형 후단 판정: 실제 실행 증거가 있으면 자기신고도 대조한다. 확실한 달성 판정만 신고를 뒤집는다.
    const reviewIncomplete = selfReportedIncomplete && AGENT_TASK_LIMITS.GOAL_JUDGE_ENABLED && !!toolEvidence?.trim();

    // 1. 실행 증거가 없거나 판정이 꺼져 있으면 종전처럼 자기신고를 유지한다.
    if (selfReportedIncomplete && !reviewIncomplete) {
        await update({
            status: 'failed',
            error: 'goal_incomplete',
            result: body,
            checkpoint: null,
            completionPath: path,
            judgeVerdict: 'skipped',
        });
        logger.info(`[AgentTask] 목표 미달성 종료: ${taskId} (turn ${turn + 1}, ${path})`);
        return { kind: 'goal_incomplete', stepNumber };
    }

    // 2. 산출물 실행 검증(결정적) — 코드 deliverable 이 컴파일되지 않으면 판정 전에 자가수정.
    //    재시도 상한을 넘어 건너뛴 검증은 이름을 모아 두었다가 완료 직전에 스텝으로 남긴다.
    //    턴 상한에서 꺼낸 보류 답변(verifyHeld)은 더 고칠 턴이 없으므로 상한을 넘긴 것과 같이 다룬다.
    const verifyRetries = input.verifyHeld ? Number.POSITIVE_INFINITY : input.verifyRetries;
    const skippedGates: string[] = [];
    if (taskRuntime && AGENT_TASK_LIMITS.VERIFY_DELIVERABLE_ENABLED && artifacts.length > 0
        && verifyRetries >= AGENT_TASK_LIMITS.VERIFY_DELIVERABLE_MAX_RETRIES) skippedGates.push('deliverable');
    if (taskRuntime && AGENT_TASK_LIMITS.WORKSPACE_TEST_GATE_ENABLED
        && verifyRetries >= AGENT_TASK_LIMITS.WORKSPACE_TEST_MAX_RETRIES) skippedGates.push('workspace_tests');
    if (taskRuntime
        && AGENT_TASK_LIMITS.VERIFY_DELIVERABLE_ENABLED
        && verifyRetries < AGENT_TASK_LIMITS.VERIFY_DELIVERABLE_MAX_RETRIES
        && artifacts.length > 0) {
        const verify = await verifyCodeArtifacts(taskRuntime, artifacts, signal);
        if (!verify.ok) {
            logger.info(`[AgentTask] 산출물 검증 실패 → 자가수정 유도: ${taskId} (재시도 ${input.verifyRetries + 1})`);
            if (input.hold) input.hold.answer = input;
            return { kind: 'verify_retry', stepNumber, nudge: getAgentTaskVerifyFailedNudge(verify.report) };
        }
    }
    // workspace 테스트 게이트 — 레포에 이미 있는 러너만 1회 실행(없으면 no-op). 파일을 편집한 작업 한정.
    // 재시도 카운터는 deliverable 검증과 공유(둘 다 verifyRetries++) — 합산 상한으로 무한루프 방지.
    const evidence = VERIFY_EVIDENCE.ENABLED && input.conversation ? collectVerificationEvidence(input.conversation) : null;
    if (taskRuntime
        && AGENT_TASK_LIMITS.WORKSPACE_TEST_GATE_ENABLED
        && verifyRetries < AGENT_TASK_LIMITS.WORKSPACE_TEST_MAX_RETRIES
        && !noteTestGateSkip(evidence && !evidence.mutated ? VERIFY_EVIDENCE_SKIP_NOTES.no_change() : null, taskId, emitStep)) {
        const tests = await verifyWorkspaceTests(taskRuntime, taskId, usedTools, stepNumber, signal, evidence?.freshPass?.runner);
        stepNumber = tests.stepNumber;
        noteTestGateSkip(tests.provenSkip && evidence?.freshPass ? VERIFY_EVIDENCE_SKIP_NOTES.fresh_pass(evidence.freshPass.command) : null, taskId, emitStep);
        emitStepIfRan(tests, emitStep);
        if (tests.ran && !tests.ok) {
            logger.info(`[AgentTask] 테스트 게이트 실패 → 수정 유도: ${taskId} (${tests.runner}, 재시도 ${input.verifyRetries + 1})`);
            if (input.hold) input.hold.answer = input;
            return { kind: 'verify_retry', stepNumber, nudge: getAgentTaskTestsFailedNudge(tests.runner ?? 'test', tests.report) };
        }
    }

    // 3. goal judge — 아티팩트 없는 완료와 파일 도구 작업에 판정을 적용한다.
    //    그 밖의 아티팩트가 있는 완료는 셰도우로 판정만 돌려 기록한다(fail-open):
    //    발동 조건 확대의 게이트가 judge 오판율인데, 현행 조건으로는 completed 의 18% 만
    //    판정을 거쳐 잴 표본이 쌓이지 않는다(2026-08-27 실측 30일: 120건 중 achieved 22 ·
    //    skipped 43 · 미판정 55, 그중 34건이 아티팩트 보유로 우회).
    let verdict: JudgeVerdict = 'skipped';
    // 파일 도구를 쓴 작업은 보고서 아티팩트만으로 실제 파일 작업 판정을 우회하지 않는다(C형 후단 판정).
    const workspaceTask = taskRuntime !== null && [...usedTools].some((name) => Object.hasOwn(FILE_MUTATING_CALLS, name));
    const judgeApplies = reviewIncomplete || artifacts.length === 0 || workspaceTask;
    if (AGENT_TASK_LIMITS.GOAL_JUDGE_ENABLED
        && (judgeApplies || AGENT_TASK_LIMITS.GOAL_JUDGE_SHADOW_ENABLED)) {
        // 실행 환경 없이 진행한 작업이면 그 사실을 판정에 알린다(sandbox-unavailable).
        // 사용자가 승인 카드로 거절한 동작도 알린다 — 사용자가 스스로 뺀 동작 때문에 미달성으로 잡히지 않게.
        let execCtx = withUserRejectionsJudgeNote(withSandboxUnavailableJudgeNote(
            buildJudgeExecutionContext(usedTools, turn + 1, taskRuntime?.getPlanSnapshot() ?? [], toolEvidence), taskId),
        await loadUserRejections(taskId));
        if (workspaceTask) {
            try { execCtx = withWorkspaceJudgeNote(execCtx, await taskRuntime!.listWorkspace(true)); }
            catch (e) { logger.warn(`[AgentTask] 파일 목록 조회 실패 — 목록 없이 판정: ${taskId}: ${e instanceof Error ? e.message : String(e)}`); }
        }
        // 셰도우 경로에선 ANSWER 에서 떨어져 나간 산출물을 함께 싣는다(적용 경로는 아티팩트 0 이라 빈 값).
        // 원장 귀속 — 판정 호출의 비용도 이 작업 id 로 묶는다.
        const outcome = await runWithCostSession(taskId, async () => {
            try {
                const judgeClient = await judgeClientFor(userId, { internalOnly: sandboxCfg.internalOnly });
                return await judgeGoal(judgeClient, goal, body ?? '', signal, execCtx,
                    artifacts.length > 0 ? buildJudgeArtifactSummary(artifacts) : undefined);
            } catch (e) {
                const message = e instanceof Error ? e.message : String(e);
                logger.warn(`[AgentTask] 판정 호출 실패 — 기존 결과 보존: ${taskId}: ${message}`);
                return { achieved: null, reason: '', raw: `error: ${message.slice(0, AGENT_TASK_LIMITS.GOAL_JUDGE_RAW_KEEP_CHARS)}` };
            }
        });
        const achieved = outcome.achieved;
        const judged: JudgeVerdict = achieved === null ? 'unknown' : achieved ? 'achieved' : 'not_achieved';
        // 판정·사유·입력 요약을 스텝으로 남긴다 — 오판 사후 규명용(관측 전용, fail-open).
        stepNumber = await persistJudgeStep(
            taskId, stepNumber, judged, outcome.reason, outcome.raw, execCtx, { shadow: !judgeApplies });
        emitStep(judgeApplies ? 'judge' : 'judge_shadow', undefined,
            `${judgeApplies ? '' : '[셰도우] '}판정: ${judged}${outcome.reason ? ` — ${outcome.reason}` : ''}`);
        // 셰도우는 여기까지. `judge_verdict` 컬럼은 'skipped' 로 둔다 — 적용된 판정만 담는
        // 컬럼이라, 셰도우 값을 넣으면 not_achieved 인데 completed 인 행이 생겨 기존 집계가
        // 깨진다(셰도우 표본은 step_type='judge_shadow' 로 읽는다).
        if (judgeApplies) {
            verdict = judged;
            if (achieved === false || (reviewIncomplete && achieved !== true)) {
                // 파일 작업 판정으로 실패해도 제출한 보고서 참조가 끊기지 않게 남긴다.
                stepNumber = await persistArtifactSteps(taskId, artifacts, stepNumber, userId);
                await update({
                    status: 'failed',
                    error: 'goal_incomplete',
                    result: body,
                    checkpoint: null,
                    completionPath: path,
                    judgeVerdict: verdict,
                });
                logger.info(`[AgentTask] judge 목표 미달성 종료: ${taskId} (turn ${turn + 1}, ${path})`);
                return { kind: 'goal_incomplete', stepNumber };
            }
        }
    }

    // 4. 산출물 영속 후 완료.
    if (skippedGates.length > 0 || input.verifyHeld) {
        const skippedNote = input.verifyHeld ? getVerifyHeldAnswerNote(skippedGates) : verifySkippedMessage(skippedGates);
        stepNumber = await persistVerifySkippedStep(taskId, stepNumber, skippedGates, skippedNote);
        emitStep('verify_skipped', undefined, skippedNote);
    }
    stepNumber = await persistArtifactSteps(taskId, artifacts, stepNumber, userId);
    stepNumber = await maybePersistCodeDiff(taskRuntime, sandboxCfg, taskId, stepNumber, emitStep);
    await update({
        status: 'completed',
        progress: 100,
        // 끝까지 성공하지 못한 파일 쓰기가 있으면 경로를 각주로 덧붙인다 — 모델이 실패를 놓치고 끝낸 경우를 사용자가 알 수 있게.
        // 실행 환경(샌드박스) 없이 진행한 작업이면 그 사실도 각주로 남긴다.
        result: withSandboxUnavailableFootnote(withWriteFailureFootnote(body, input.conversation), taskId),
        // 이전 시도의 실패 사유를 지운다 — resume/재실행으로 완료된 작업에 'aborted'·'goal_incomplete'
        // 가 남아 목록·CLI 가 성공을 실패처럼 보여줬다(2026-08-26 resume E2E 에서 실측).
        error: null,
        checkpoint: null, // 완료 작업은 재개 대상 아님 — checkpoint 잔존 시 resume 허용·저장 팽창
        completionPath: path,
        judgeVerdict: verdict,
    });
    logger.info(`[AgentTask] 완료: ${taskId} (${turn + 1} 턴, ${path}, judge=${verdict}, 아티팩트 ${artifacts.length}개)`);
    return { kind: 'completed', stepNumber };
}

/** 이 작업에서 사용자가 거절한 승인 — 조회 실패는 fail-open(거절 없음으로 보고 판정은 종전대로 진행). */
async function loadUserRejections(taskId: string): Promise<JudgeUserRejection[]> {
    try {
        return await new AgentTaskApprovalRepository(getPool()).listRejectedForTask(taskId, AGENT_TASK_LIMITS.GOAL_JUDGE_REJECTION_MAX_ITEMS);
    } catch (e) {
        logger.warn(`[AgentTask] 거절 승인 조회 실패 — 판정은 거절 없이 진행: ${taskId}: ${e instanceof Error ? e.message : String(e)}`);
        return [];
    }
}

/**
 * 검증 증거 원장(VERIFY_EVIDENCE.ENABLED) — 테스트 게이트를 돌리지 않은 이유(note)를 로그와 진행 표시로 남긴다. 남겼으면 true.
 * 이유는 둘이다: 파일을 바꾼 흔적이 없거나(게이트를 부르지 않는다), 마지막 변경 이후 같은 러너의 전체 실행이 통과했거나(게이트가 러너를 확인한 뒤 건너뛴다).
 */
function noteTestGateSkip(note: string | null, taskId: string, emitStep: FinalizeInput['emitStep']): boolean {
    if (note === null) return false;
    logger.info(`[AgentTask] ${note}: ${taskId}`);
    emitStep('test_verify', undefined, note);
    return true;
}

function emitStepIfRan(
    tests: { ran: boolean; ok: boolean; runner?: string },
    emitStep: FinalizeInput['emitStep'],
): void {
    if (tests.ran) emitStep('test_verify', tests.runner, `테스트 게이트: ${tests.runner} ${tests.ok ? '통과' : '실패'}`);
}
