/**
 * 외부 provider 응답의 결정적 첨부 후처리 — external-provider.ts 에서 분리 (600줄 CI 가드).
 *
 * 도구 루프 중 수집한 블록(생성 이미지·통합 블록·웹검색 출처·보고서)을 최종
 * 응답 끝에 1회 붙인다. LLM(특히 qwen)이 도구 지시("마크다운 그대로 포함")나 인용 지시를
 * 자주 무시해 산출물/근거가 답변에 안 드러나던 문제를 결정적으로 보정한다. onToken =
 * 라이브 스트림, 반환값 = 저장 히스토리 — 양쪽에 반영해 reload 후에도 유지.
 *
 * @module services/chat-service/external-deterministic-append
 */
import { createLogger } from '../../utils/logger';
import { getActiveChatTurnIntegrations, type IntegrationBlocks } from './turn-integrations';
import { MODEL_SOURCE_SECTION, REPORT_PIPELINE, WEB_SEARCH_INJECTION } from '../../config/runtime-limits';
import { tryRenderReportBlock } from './report-block';
import { stripMissingGeneratedLinks } from './generated-link-guard';
import { basename } from 'path';
import { getToolRuntime } from '../../runtime-ports/tool-runtime';
import { WEB_SEARCH_TEMPLATES, getLocalizedTemplate } from '../../sockets/ws-chat-locales';
import type { ChatMessageRequest } from '../chat-service-types';
import type { StreamFromExternalContext } from './external-provider-types';
import { parseInjectedSources } from '../../tools/web-search/format-sources';
import type { SearchSourceRef } from '../../tools/web-search/types';

const logger = createLogger('ChatExternalProvider');

/** 7개 언어 sourceLabel 의 정규식 alternation (중복 제거·이스케이프) — 템플릿이 SoT */
const SOURCE_LABEL_ALT = [...new Set(Object.values(WEB_SEARCH_TEMPLATES).map((t) => t.sourceLabel))]
    .map((l) => l.replace(/[.*+?^${}()|[\]\\]/g, '\\$&'))
    .join('|');
/** 라벨 인용 마커 소스 — `[출처 3]`·`[Source 1, 2]` 형태. 라벨 없는 `[3]` 은 각주/코드 오탐 위험으로 제외. */
const CITATION_MARKER_SRC = `\\[\\s*(?:${SOURCE_LABEL_ALT})\\s*\\d+(?:\\s*[,·、]\\s*\\d+)*\\s*\\]`;

/** 평문 출처 섹션의 머리줄 — (짧은 수식어) + 출처 라벨(복수형 s·n 허용) + 콜론. 1번 그룹 = 콜론 뒤 같은 줄의 내용. */
const PLAIN_SOURCE_LINE_SRC = `^[ \\t]*[^\\n:：]{0,${MODEL_SOURCE_SECTION.LABEL_PREFIX_MAX_CHARS}}?(?:${SOURCE_LABEL_ALT})[sn]?[ \\t]*[:：][ \\t]*(.*)$`;
/** 목록 항목으로 보는 줄 — 글머리표·번호·대괄호로 시작 (`- A`, `2 nxplace.com — …`, `[1] …`) */
const SOURCE_LIST_LINE_RE = /^\s*(?:[-*+•·]|\d|\[)/;

/**
 * 모델이 평문으로 쓴 출처 섹션(`검색 결과 출처:` 줄 + 목록)의 본문 — 없으면 null.
 * 본문 중간의 한 줄 표기("출처: 통계청")를 섹션으로 오인하지 않게 두 꼴만 인정한다:
 * ① 콜론 뒤가 빈 줄이고 바로 다음(빈 줄 제외)이 목록 항목 — 이어지는 목록 항목까지가 섹션(뒤의 맺음말은 섹션 밖),
 * ② 콜론 뒤에 내용이 있는 한 줄이 답변의 마지막 줄.
 */
function findPlainSourceSection(content: string): string | null {
    for (const m of content.matchAll(new RegExp(PLAIN_SOURCE_LINE_SRC, 'gim'))) {
        const rest = content.slice(m.index + m[0].length);
        if (m[1].trim()) {
            if (!rest.trim()) return m[0];
            continue;
        }
        const items: string[] = [];
        for (const line of rest.split('\n')) {
            if (!line.trim()) continue;
            if (!SOURCE_LIST_LINE_RE.test(line)) break;
            items.push(line);
        }
        if (items.length > 0) return items.join('\n');
    }
    return null;
}

/**
 * 수집 목록(validNums)에 없는 번호의 죽은 인용 마커를 제거한다 — 모델(qwen)이 주입 상한을
 * 넘는 번호([출처 11]~)를 지어내는 비순응의 결정적 후처리 (프롬프트 지시 단독 73% 순응, 2026-08-15 실측).
 * 전부 무효면 마커 삭제(선행 공백 1개 포함), 일부만 유효면 유효 번호로 재작성.
 */
export function stripDeadCitationMarkers(
    content: string,
    validNums: ReadonlySet<string>,
): { content: string; removed: number } {
    let removed = 0;
    const out = content.replace(new RegExp(`\\s?${CITATION_MARKER_SRC}`, 'gi'), (match) => {
        const nums = match.match(/\d+/g) ?? [];
        const valid = nums.filter((n) => validNums.has(n));
        if (valid.length === nums.length) return match;
        removed++;
        if (valid.length === 0) return '';
        const label = new RegExp(`(${SOURCE_LABEL_ALT})`, 'i').exec(match)?.[1] ?? '출처';
        return `${match.startsWith(' ') ? ' ' : ''}[${label} ${valid.join(', ')}]`;
    });
    return { content: out, removed };
}

/**
 * 스트리밍 본문(streamed)에 있던 인용 마커가 최종본(final)에서 제거/축소됐는지 감지 —
 * ws-chat-handler 가 done.cleanedContent 로 화면 본문을 교체할지 판정하는 데 사용
 * (artifact placeholder·script-purity 교체와 동일 패턴: 차이가 있는 턴만 정확히 겨냥).
 */
export function citationMarkersWereCleaned(streamed: string, final: string): boolean {
    const collect = (s: string) =>
        new Set((s.match(new RegExp(CITATION_MARKER_SRC, 'gi')) ?? []).map((m) => m.replace(/\s+/g, '')));
    const before = collect(streamed);
    if (before.size === 0) return false;
    const after = collect(final);
    for (const m of before) if (!after.has(m)) return true;
    return false;
}

/** 통합(add-on)의 최종 본문 후처리를 차례로 적용한다 — 모델이 지어낸 통합 전용 마크업 제거 등. */
export function scrubByIntegrations(content: string): { content: string; removed: number } {
    let out = content;
    let removed = 0;
    for (const integration of getActiveChatTurnIntegrations()) {
        const r = integration.scrubFinalContent?.(out);
        if (r) { out = r.content; removed += r.removed; }
    }
    return { content: out, removed };
}

/** 스트리밍 본문엔 통합 후처리 대상이 있었는데 최종본에선 제거됐는지 — cleanedContent 교체 판정용. */
export function integrationScrubWasCleaned(streamed: string, final: string): boolean {
    return scrubByIntegrations(streamed).removed > 0 && scrubByIntegrations(final).removed === 0;
}

interface DeterministicAppendInput {
    /** 모델이 만든 최종 본문 (이미 라이브 스트리밍된 텍스트). */
    finalContent: string;
    /** 라이브 스트림 콜백 — 첨부분을 프론트에 밀어낸다. */
    onToken: (token: string, thinking?: string) => void;
    /** 오케스트레이터 산출물(이미지·영상·음성)의 미디어 마크다운. */
    generatedMediaMarkdowns: string[];
    /** 통합(add-on)별 결정적 첨부 블록 — 도구 결과에서 떼어 둔 것. */
    integrationBlocks: IntegrationBlocks;
    /** 오픈디자인 도구로 저장한 HTML 산출물 (마지막 저장본 — captureOdArtifactHtml 참고). */
    odArtifact?: OdArtifactCapture | null;
    /** 이 턴의 도구 출처(web_search 결과·읽은 페이지) — 호출 1회당 목록 1개, 결과가 나온 순서. 번호는 사전 주입 뒤로 이어진다. */
    toolSources?: SearchSourceRef[][];
    req: ChatMessageRequest;
    ctx: StreamFromExternalContext;
}

/** open-design 도구 인자에서 캡처한 HTML 산출물. */
export interface OdArtifactCapture {
    id: string;
    title: string;
    html: string;
}

/**
 * mcp_call 메타 도구 경유 간접 호출을 실제 도구 호출로 정규화한다.
 * mcp_call(server, tool, args) → { name: "server::tool", args } — 직접 호출은 그대로 반환.
 * (진행적 공개 경로로 open-design 을 부르면 tc.name 이 'mcp_call' 이라 캡처를 놓치는 갭 보정.)
 */
export function normalizeOdToolCall(
    name: string,
    args: Record<string, unknown>,
): { name: string; args: Record<string, unknown> } {
    // 메타 도구(`mcp_call`) 를 실제 대상으로 푸는 규칙은 도구 런타임이 안다 — Base 는 정규화만 요청한다.
    return getToolRuntime().normalizeToolCall(name, args);
}

/**
 * open-design create_artifact/write_file 호출 인자에서 자체완결 HTML 을 캡처한다.
 * CSS/JSX 등 부속 파일이나 실패한 호출은 null — 호출부는 마지막 캡처만 유지한다(수정본 우선).
 */
export function captureOdArtifactHtml(
    args: Record<string, unknown>,
    toolResult: string,
): OdArtifactCapture | null {
    if (toolResult.startsWith('Error')) return null;
    const content = typeof args.content === 'string' ? args.content : '';
    const head = content.trimStart().slice(0, 15).toLowerCase();
    if (!head.startsWith('<!doctype') && !head.startsWith('<html')) return null;
    const fileName = typeof args.name === 'string' ? args.name
        : typeof args.path === 'string' ? args.path : '';
    const base = basename(fileName).replace(/\.[a-z0-9]+$/i, '') || 'design';
    const titleTag = /<title[^>]*>([^<]{1,200})<\/title>/i.exec(content)?.[1]?.trim();
    // 아티팩트 시작 태그 속성은 "..." 파싱 — 제목의 큰따옴표는 작은따옴표로 강등(report-block 동일).
    const title = (titleTag || base).replace(/"/g, "'").slice(0, 200);
    const id = `${base.toLowerCase().replace(/[^a-z0-9]+/g, '-').replace(/^-|-$/g, '') || 'design'}-${Date.now().toString(36)}`;
    return { id, title, html: content };
}

/**
 * 수집된 블록을 최종 응답에 결정적으로 첨부하고 갱신된 본문을 반환한다.
 */
export function appendDeterministicBlocks(input: DeterministicAppendInput): string {
    const { onToken, generatedMediaMarkdowns, integrationBlocks, req, ctx } = input;
    let finalContent = input.finalContent;

    // 생성 미디어 마크다운을 LLM 이 최종 응답에서 누락한 경우 결정적 첨부 — 미디어 링크는 모델 본문이
    // 아니라 이 첨부가 SoT 다. (onToken = 라이브 스트림, 반환값 = 저장 히스토리 — 양쪽에 반영해
    // reload 후에도 유지.)
    const missingMedia = generatedMediaMarkdowns.filter((md) => {
        const pathMatch = md.match(/\(([^)]+)\)/);
        return !pathMatch || !finalContent.includes(pathMatch[1]);
    });
    if (missingMedia.length > 0) {
        const appended = (finalContent.trim() ? '\n\n' : '') + missingMedia.join('\n\n');
        onToken(appended, undefined);
        finalContent += appended;
        logger.info(`🖼️ 생성 미디어 ${missingMedia.length}개 자동 첨부 (LLM 응답 누락 보정)`);
    }

    // 생성 파일 링크 환각 제거 — 이번 턴 생성분도 아니고 디스크에도 없는 /generated/ 링크(모델이 파일명을
    // 지어낸 경우). 저장 히스토리(반환값)가 대상. 화면은 아래 지도 환각과 같이 done.cleanedContent 교체.
    const produced = new Set(generatedMediaMarkdowns.map((md) => md.match(/\(([^)]+)\)/)?.[1]).filter((p): p is string => !!p));
    const linkStrip = stripMissingGeneratedLinks(finalContent, produced, undefined, ctx.resolvedLanguage || req.userLanguagePreference || 'ko');
    if (linkStrip.removed.length > 0) {
        finalContent = linkStrip.content;
        logger.warn(`🧹 존재하지 않는 /generated 링크 ${linkStrip.removed.length}개 제거 (모델 환각): ${linkStrip.removed.join(', ')}`);
    }

    // 통합 후처리(모델 환각 마크업 제거 등) — 저장 히스토리(반환값)가 대상. 화면은 done.cleanedContent 교체.
    const scrubbed = scrubByIntegrations(finalContent);
    if (scrubbed.removed > 0) {
        finalContent = scrubbed.content;
        logger.info(`🧹 통합 후처리로 ${scrubbed.removed}개 제거 (모델 환각 마크업)`);
    }

    // 통합 블록도 동일하게 — LLM 이 옮기지 않았으면 결정적 첨부(라이브 stream + 저장 히스토리).
    for (const integration of getActiveChatTurnIntegrations()) {
        const missing = (integrationBlocks[integration.id] ?? []).filter((b) => !finalContent.includes(b));
        if (missing.length === 0) continue;
        const appended = (finalContent.trim() ? '\n\n' : '') + missing.join('\n\n');
        onToken(appended, undefined);
        finalContent += appended;
        logger.info(`${integration.blockLabel ?? integration.id} ${missing.length}개 자동 첨부 (LLM 응답 누락 보정)`);
    }

    // 웹검색 출처 목록 결정적 첨부 (서버 canonical 출처, 2026-08-14 강화) — 출처 목록의
    // 정합성을 모델(qwen) 재량에 맡기지 않는다. 프롬프트는 "[출처 N] 인라인 마커만, 목록 작성
    // 금지"로 지시하고(ws-chat-locales), 목록은 서버가 실제 수집한 (번호→제목·URL) 매핑으로
    // 생성한다. 모델이 지시를 무시하고 목록을 만들었으면(비순응 상습) 인용 번호별 URL 존재를
    // 검증해 누락분만 보강 — 인용 [출처 3]·[출처 8]이 목록에서 빠지던 라이브 결함의 재발 차단.
    // (이미 스트리밍된 본문은 수정 불가 → 모든 교정은 append-only.)
    // 소스 문자열은 message-pipeline 경로에선 req.webSearchContext 가 아니라 ctx.enhancedMessage
    // (finalEnhancedMessage, context-builder 가 웹검색 컨텍스트를 합친 값)에 실려 온다. 둘 다 fallback.
    const webSearchCtxText = req.webSearchContext || ctx.enhancedMessage || '';
    // 사전 주입이 없어도 모델이 web_search 도구를 불러 출처가 있으면 같은 처리를 한다 — 게이트가 사전 주입만 보던
    // 때는 도구 검색만 돈 턴의 [출처 N] 인용에 목록이 붙지 않고 목록 밖 번호 마커도 남았다.
    // 컨텍스트에서 번호→(제목, URL) 파싱 — canonical 목록 생성·누락 검증에 공용.
    const numToSource = parseInjectedSources(webSearchCtxText);
    const hasInjectedSources = numToSource.size > 0;
    const srcLang = ctx.resolvedLanguage || req.userLanguagePreference || 'en';
    const srcLabel = getLocalizedTemplate(WEB_SEARCH_TEMPLATES, srcLang).sourceLabel;
    const headerRe = new RegExp(`(^|\\n)\\s*(#{1,3}\\s*|\\*\\*\\s*)${srcLabel}`);
    const headerIdx = finalContent.search(headerRe);
    // 도구 검색만 돈 턴에서 모델이 출처 섹션을 직접 썼으면 건드리지 않는다 — 목록 작성 금지 지시가 없는 턴이라
    // 모델이 읽은 페이지까지 섞어 자기 번호로 목록을 쓰고, 도구 번호표 기준의 마커 제거·목록 첨부는 그 번호와 어긋난다
    // (2026-10-12 라이브: 모델 1번 = 공식 블로그, 도구 1번 = 무관한 페이지 — URL 없는 섹션에 붙였더니 엉뚱한 출처가 달렸다).
    // 이 턴은 평문 머리줄(`검색 결과 출처:`)도 섹션으로 본다. 사전 주입 턴의 판정(헤딩·굵은 글씨면 섹션)은 그대로.
    const alreadyHasSources = headerIdx >= 0 || (!hasInjectedSources && findPlainSourceSection(finalContent) !== null);
    if (hasInjectedSources || (!alreadyHasSources && (input.toolSources ?? []).some((list) => list.length > 0))) {
        // 같은 턴에 모델이 부른 web_search 의 출처도 번호표에 넣는다 — 번호가 사전 주입 뒤(11~)라 여기 없으면
        // 모델의 [출처 11] 인용이 아래에서 죽은 마커로 지워지고 무관한 사전 검색 전체가 붙는다(2026-10-12 라이브).
        const toolSources = (input.toolSources ?? []).filter((list) => list.length > 0);
        const injectedNums = [...numToSource.keys()];
        for (const s of toolSources.flat()) {
            if (!numToSource.has(String(s.n))) numToSource.set(String(s.n), { title: s.title, url: s.url });
        }
        // 인용이 없을 때 붙일 기본 목록 — 도구 검색이 돈 턴은 가장 최근 검색의 상위 N건(모델이 마지막에 보고 쓴 근거),
        // 도구 검색이 없던 턴은 번호표 전체(= 사전 주입 전체, 기존 동작). 사전 주입 없이 도구 검색만 돈 턴은
        // 기본 목록이 없다 — 모델이 읽은 페이지를 `출처: A, B` 평문으로 직접 쓴 답에 검색 결과가 덧붙는 소음 방지.
        // 1건짜리 목록은 읽은 페이지(extract_webpage·web_scrape)다 — 검색을 대신하지 않고, 최근 검색 뒤에 읽은 것을 덧붙인다.
        const lastSearchIdx = toolSources.map((list) => list.length > 1).lastIndexOf(true);
        const lastToolSearch = lastSearchIdx >= 0 ? toolSources[lastSearchIdx] : undefined;
        const defaultNums = !hasInjectedSources
            ? []
            : [
                ...(lastToolSearch
                    ? (WEB_SEARCH_INJECTION.MAX_RESULTS > 0 ? lastToolSearch.slice(0, WEB_SEARCH_INJECTION.MAX_RESULTS) : lastToolSearch).map((s) => String(s.n))
                    : injectedNums),
                ...toolSources.slice(lastSearchIdx + 1).flat().map((s) => String(s.n)),
            ];
        // 수집 목록에 없는 번호의 죽은 인용 마커 결정적 제거 — 저장 히스토리(반환값)가 대상.
        // 이미 스트리밍된 화면은 ws-chat-handler 의 done.cleanedContent 교체가 완료 시점에 정리.
        const stripRes = stripDeadCitationMarkers(finalContent, new Set(numToSource.keys()));
        if (stripRes.removed > 0) {
            finalContent = stripRes.content;
            logger.info(`🧹 죽은 인용 마커 ${stripRes.removed}개 제거 (수집 목록 밖 번호)`);
        }
        // 본문에 인용된 소스 번호 ([출처 N]/[Source N]/[N] — 수집 목록에 있는 번호만 인정).
        // 대괄호 안 숫자를 전부 인정 — `[출처 3, 8]` 복합 인용에서 마지막 숫자만 잡혀 앞 번호
        // 출처가 목록에서 빠지던 결함 방지.
        // 도구 검색만 돈 턴은 라벨 있는 인용만 인정한다 — 번호표가 1부터라 모델이 직접 쓴 각주 `[1]`·코드의
        // `arr[3]` 이 도구 출처 번호와 우연히 맞아 무관한 목록이 붙는다. 사전 검색 턴의 인정 범위는 그대로.
        const citedNums: string[] = [];
        const citeRe = hasInjectedSources ? /\[[^\]\n]*\d[^\]\n]*\]/g : new RegExp(CITATION_MARKER_SRC, 'gi');
        let cm: RegExpExecArray | null;
        while ((cm = citeRe.exec(finalContent)) !== null) {
            for (const num of cm[0].match(/\d+/g) ?? []) {
                if (numToSource.has(num) && !citedNums.includes(num)) citedNums.push(num);
            }
        }
        if (!alreadyHasSources) {
            // canonical 목록 첨부 — 인용된 번호가 있으면 그 소스만(정밀), 없으면 기본 목록(defaultNums).
            // 번호는 인라인 인용과 일치하도록 원본 소스 번호를 유지한다 (재번호 시 [출처 3]↔목록 불일치).
            const targetNums = citedNums.length > 0 ? citedNums : defaultNums;
            const entries: string[] = [];
            const seen = new Set<string>();
            for (const n of targetNums) {
                const { title, url } = numToSource.get(n)!;
                if (url && !seen.has(url)) {
                    seen.add(url);
                    // 글머리 목록 + 굵은 번호 — `N. ` 순서 목록으로 쓰면 마크다운이 첫 번호만 따라 1,2,3 으로 다시 매기고
                    // (인용 [출처 8] ↔ 목록 "3."), 1 로 시작하지 않으면 목록이 안 되어 한 문단으로 뭉친다(2026-10-12 라이브).
                    entries.push(`- **${n}.** [${title || url}](${url})`);
                }
            }
            if (entries.length > 0) {
                const block = `\n\n---\n\n**${srcLabel}**\n${entries.join('\n')}`;
                onToken(block, undefined);
                finalContent += block;
                logger.info(`🔗 웹검색 출처 ${entries.length}개 자동 첨부 (서버 canonical${citedNums.length > 0 ? ', 인용 기반' : ''})`);
            }
        } else {
            // 모델이 목록 작성 금지 지시를 무시하고 섹션을 만든 경우 — 인용 번호별로 해당
            // 소스 URL 이 **출처 섹션 안에** 존재하는지 검증, 누락분만 보강. 인용이 전혀 없는데
            // 섹션에 URL 도 없으면(제목만 나열) 기본 목록(defaultNums) 보강.
            // 검사는 섹션 스코프(본문 산문의 URL 언급이 섹션 누락을 가리지 않게) + URL 정규화
            // (프로토콜·트레일링 슬래시·대소문자 변형이 중복 첨부로 이어지지 않게) 비교.
            const normalizeUrl = (u: string) =>
                u.replace(/[),.\]]+$/, '').replace(/\/$/, '').replace(/^https?:\/\//i, '').toLowerCase();
            const sectionUrls = new Set(
                (finalContent.slice(headerIdx).match(/https?:\/\/[^\s)\]]+/g) ?? []).map(normalizeUrl),
            );
            const missingNums = citedNums.filter((n) => !sectionUrls.has(normalizeUrl(numToSource.get(n)!.url)));
            const nums = missingNums.length > 0
                ? missingNums
                : citedNums.length === 0 && !/https?:\/\//.test(finalContent.slice(headerIdx))
                    ? defaultNums
                    : [];
            const lines = nums.map((n) => `[${n}] ${numToSource.get(n)!.url}`);
            if (lines.length > 0) {
                const block = `\n\n🔗 **URL**\n${lines.join('\n')}`;
                onToken(block, undefined);
                finalContent += block;
                logger.info(`🔗 출처 링크 ${lines.length}개 보강 (모델 출처 섹션 누락 검증)`);
            }
        }
    }

    // 오픈디자인 산출물 결정적 첨부 — create_artifact 로 워크스페이스에 저장한 HTML 덱을
    // 모델이 최종 응답 <artifact> 로 옮기지 않으면(말로만 안내, 2026-08-14 라이브 실측) 서버가
    // 1회 첨부한다. 모델이 이미 html 아티팩트를 출력했으면 중복 첨부하지 않는다.
    if (input.odArtifact && !/<artifact\b[^>]*kind="html"/.test(finalContent)) {
        const a = input.odArtifact;
        const block = `\n\n<artifact id="${a.id}" kind="html" title="${a.title}">\n${a.html}\n</artifact>`;
        onToken(block, undefined);
        finalContent += block;
        logger.info(`🎨 오픈디자인 아티팩트 결정적 첨부: "${a.title}" (${a.html.length}B)`);
    }

    // 보고서 결정적 렌더 (P1 파이프라인) — 모델이 출력한 ```reportdata JSON 블록을 고정
    // 템플릿으로 렌더해 <artifact> 로 첨부한다(카카오맵·출처와 동일한 결정적 첨부 패턴).
    // 원문 JSON 블록은 히스토리에서 제거 — 라이브 스트림에 이미 나간 블록은 프론트가 접는다.
    if (REPORT_PIPELINE.ENABLED) {
        const report = tryRenderReportBlock(finalContent);
        if (report) {
            onToken(report.artifactAppend, undefined);
            finalContent = report.content + report.artifactAppend;
            logger.info(`📊 보고서 아티팩트 결정적 첨부: "${report.title}"`);
        }
    }

    return finalContent;
}
