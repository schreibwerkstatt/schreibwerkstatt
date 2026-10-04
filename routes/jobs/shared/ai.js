'use strict';
const {
  callAI, parseJSON, CHARS_PER_TOKEN, getContextConfigFor, resolveProvider,
  providerClass, effectiveProviderClass, normalizeTier, _resolveClaudeModel,
  estimatePromptTokens, assertPromptFitsContext,
} = require('../../../lib/ai');
const { costUsd } = require('../../../lib/pricing');
const logger = require('../../../logger');
const appSettings = require('../../../lib/app-settings');
const { stripDiagramBlocks, summarizeTableBlocks } = require('../../../lib/html-text');
const { jobAbortControllers } = require('./state');
const { updateJob, i18nError, fmtTok } = require('./jobs');

// Transient-Klassifikator: Claude-Streams droppen gelegentlich mid-flight als
// 'terminated' (Undici-Socket-Reset) oder werden vom Hard-Timeout (`AI_TIMEOUT`)
// nach `ai.claude.timeout_ms` abgebrochen. Beides ist nicht-fatal: ein erneuter
// Versuch erwischt typischerweise einen warmen Anthropic-Prompt-Cache (von
// parallelen oder vorhergehenden Chunks geschrieben) und laeuft deutlich
// schneller durch. JSON-Parse-Failures (Modell-Output) sind dagegen
// deterministisch → kein Retry.
function _isTransientAiError(e) {
  if (!e) return false;
  if (e.code === 'AI_TIMEOUT') return true;
  const msg = (e.message || '').toLowerCase();
  if (msg.includes('terminated')) return true;
  if (e.cause && /UND_ERR_SOCKET|ECONNRESET|other side closed/i.test(String(e.cause?.code || e.cause?.message || ''))) return true;
  return false;
}

/** Fuehrt `fn` aus und retried bei transient AI-Fehlern (max. `tries`-1 Re-Versuche).
 *  AbortError wird sofort weitergereicht; deterministische Fehler ebenfalls. */
async function retryOnTransientAi(fn, { tries = 2, log = null, label = '' } = {}) {
  let lastErr;
  for (let attempt = 1; attempt <= tries; attempt++) {
    try { return await fn(); }
    catch (e) {
      if (e.name === 'AbortError') throw e;
      if (!_isTransientAiError(e) || attempt === tries) throw e;
      lastErr = e;
      if (log) log.warn(`${label || 'AI-Call'} transient (${e.message}) – Retry ${attempt}/${tries - 1}.`);
    }
  }
  throw lastErr;
}

// ── Lokaler-Provider-kompatibler Promise.allSettled-Ersatz ────────────────────
// Ollama und Llama verarbeiten Requests sequenziell. Bei parallelen Calls mit
// grossem Kontext läuft der VRAM voll → fetch failed. Daher serialisieren.
//
// Claude-Multi-Pass mit vielen Chunks (grosse Bücher, 11+ Chunks) trifft sonst
// Anthropic-TPM-Limits → einige Streams kommen als „terminated" zurück. Optional
// `opts.concurrency` (Default: unbegrenzt) cappt parallele Calls; `opts.warmup`
// (Default: false) lässt den ERSTEN Thunk seriell laufen, bevor der Rest startet
// — der Erst-Call schreibt den Prompt-Cache, Folge-Calls greifen den Cache-Hit
// und sind ~10× günstiger + viel kürzer (kleinerer TPM-Burst).
async function settledAll(thunks, opts = {}) {
  // Klassen-SSoT: lib/ai/config.js#effectiveProviderClass — openai-compat mit
  // Cloud-Schalter laeuft hier parallel (gedeckelt via max_parallel-Semaphore).
  // Am EFFEKTIVEN Provider dieses Users (KI-Profil vor globalem ai.provider), nicht
  // an der Instanz-Einstellung: sonst faehrt ein Claude-User seriell, weil global
  // Ollama eingestellt ist — und ein Ollama-User parallel in den VRAM-Ueberlauf.
  const isLocal = effectiveProviderClass() === 'local';
  if (isLocal) {
    const results = [];
    for (const fn of thunks) {
      try { results.push({ status: 'fulfilled', value: await fn() }); }
      catch (e) {
        if (e.name === 'AbortError') throw e;
        results.push({ status: 'rejected', reason: e });
      }
    }
    return results;
  }

  const settle = async (fn) => {
    try { return { status: 'fulfilled', value: await fn() }; }
    catch (e) {
      if (e.name === 'AbortError') throw e;
      return { status: 'rejected', reason: e };
    }
  };

  const results = new Array(thunks.length);
  let nextIdx = 0;

  if (opts.warmup && thunks.length > 1) {
    results[0] = await settle(thunks[0]);
    nextIdx = 1;
  }

  const concurrency = Math.max(1, opts.concurrency || thunks.length);
  const remaining = thunks.length - nextIdx;
  if (remaining <= 0) return results;
  const workerCount = Math.min(concurrency, remaining);

  const worker = async () => {
    while (true) {
      const i = nextIdx++;
      if (i >= thunks.length) return;
      results[i] = await settle(thunks[i]);
    }
  };
  await Promise.all(Array.from({ length: workerCount }, worker));
  return results;
}

// ── HTML-Entity-Dekodierung ──────────────────────────────────────────────────
// Single-Pass-Dekoder: jede Entity wird genau einmal aufgelöst, damit
// `&amp;#39;` (literal: &#39;) nicht versehentlich zu `'` re-decodiert wird.
const HTML_NAMED_ENTITIES = {
  nbsp: ' ', amp: '&', lt: '<', gt: '>', quot: '"', apos: "'",
  ndash: '–', mdash: '—', hellip: '…',
  laquo: '«', raquo: '»',
  lsquo: '‘', rsquo: '’',
  ldquo: '“', rdquo: '”',
  bdquo: '„', sbquo: '‚',
  auml: 'ä', Auml: 'Ä', ouml: 'ö', Ouml: 'Ö', uuml: 'ü', Uuml: 'Ü',
  szlig: 'ß', shy: '', copy: '©', reg: '®', trade: '™',
  euro: '€', deg: '°',
};

// Token-Sparkur fürs Buchtext-Preprocessing (claude-only).
// Wird nach loadPageContents auf jede Seite angewendet, BEVOR fullBookText oder
// Multi-Pass-Chunks gebaut werden – damit P1 und P8 byte-identischen Buchtext
// sehen (Cache-Read in P8 trifft den 1h-Block aus P1).
// Greift Reste, die htmlToText nicht entfernt: unbekannte HTML-Entities,
// Zero-Width-Zeichen, weiche Trennstriche, Mehrfach-Leerzeichen.
const _PROMPT_ENTITY_MAP = {
  nbsp: ' ', ensp: ' ', emsp: ' ', thinsp: ' ',
  mdash: '—', ndash: '–', hellip: '…', bull: '•', middot: '·',
  lsquo: '‘', rsquo: '’', ldquo: '“', rdquo: '”',
  laquo: '«', raquo: '»', sbquo: '‚', bdquo: '„',
  apos: "'", prime: '′', Prime: '″',
  times: '×', divide: '÷', plusmn: '±', minus: '−',
};

// Entity-Decoder der drei Text-Varianten unten. Numerische Referenzen (&#x2014;,
// &#8212;) werden immer aufgelöst, benannte nur, wenn sie in `map` stehen — eine
// unbekannte Entity bleibt wörtlich stehen statt zu verschwinden. Ungültige
// Codepoints (Range/`fromCodePoint`-Wurf) fallen ebenfalls auf den Rohtext
// zurück. Die drei Aufrufer unterscheiden sich nur in `map`.
function _decodeEntities(str, map) {
  return str.replace(/&(?:#x([0-9a-fA-F]+)|#(\d+)|([a-zA-Z][a-zA-Z0-9]+));/g, (m, hex, dec, name) => {
    const raw = hex !== undefined ? hex : dec;
    if (raw !== undefined) {
      const cp = parseInt(raw, hex !== undefined ? 16 : 10);
      if (Number.isFinite(cp) && cp >= 0 && cp <= 0x10FFFF) {
        try { return String.fromCodePoint(cp); } catch { return m; }
      }
      return m;
    }
    return Object.prototype.hasOwnProperty.call(map, name) ? map[name] : m;
  });
}

function cleanPageTextForAi(text) {
  return _decodeEntities(text || '', _PROMPT_ENTITY_MAP)
    .replace(/[​-‍﻿]/g, '')
    .replace(/­/g, '')
    .replace(/ /g, ' ')
    .replace(/ {2,}/g, ' ')
    .trim();
}

// DIAGRAMME FALLEN IN BEIDEN VARIANTEN RAUS, vor dem Tag-Strip. Diagramm-
// Notation ist nirgends Prosa (docs/diagramme.md, Invariante 7) — und dieser
// Pfad ist der teuerste Ort, an dem sie es waere:
//   - `flowchart TD` / `A[Ausgangslage] --> B{Entscheidung}` kostet echte
//     Input-Tokens in jedem Job, der Buchtext schickt (Komplettanalyse, Review,
//     Redundanz, Lektorat) — waehrend die dem User gezeigte Schaetzung
//     (`page_stats.tok`, aus lib/html-text.js) sie korrekt nicht enthaelt. Die
//     beiden Zahlen sollen nicht auseinanderlaufen.
//   - Das Lektorat meldete Findings auf dem Quelltext. Wird so ein Finding
//     angewendet, schreibt der Ersatz mitten in den Diagramm-Code.
//   - loadPageContents (./loader) speist damit auch den Embedding-Index
//     (routes/jobs/embed-index.js): Diagramm-Notation wurde zur semantisch
//     auffindbaren Passage, waehrend die FTS-Haelfte derselben Hybrid-Suche sie
//     ausschneidet (lib/search.js → htmlToPlainText). Zwei Indexe auf zwei
//     verschiedenen Texten.
// Ausschnitt-Regex ist die SSoT aus lib/html-text.js — keine Kopie hier.
function htmlToText(html) {
  return _decodeEntities(summarizeTableBlocks(stripDiagramBlocks(html)).replace(/<[^>]+>/g, ' '), HTML_NAMED_ENTITIES)
    .replace(/\s+/g, ' ').trim();
}

// Absatz-erhaltende HTML→Text-Variante für Lektorat-Prompts. Während
// `htmlToText` (oben) Absatzgrenzen einebnet — Tags → Space, danach jeder
// Whitespace-Lauf → ein Space —, behält diese Variante Blockgrenzen als `\n\n`
// (und `<br>` als `\n`). Why: die Dialogformat-Regel „Sprecherwechsel → neuer
// Absatz" ist nur gegen Absatzgrenzen prüfbar; in der einzeiligen Variante kann
// die KI den Umbruch gar nicht sehen und meldet jeden Sprecherwechsel als
// fehlenden Umbruch. Block-Tags: p, div, li, h1-h6, blockquote, pre, ul, ol,
// figure, figcaption, table, tr, section, article. Inline-Tags werden weiterhin
// zu Space — nur Blockgrenzen tragen einen Umbruch. Entspricht damit der Sicht
// des Lektorat-Prompts, der die Seite als Prosa mit Absätzen liest.
function htmlToTextForPrompt(html) {
  return _decodeEntities(summarizeTableBlocks(stripDiagramBlocks(html))
    .replace(/<\/(p|div|li|h[1-6]|blockquote|pre|ul|ol|figure|figcaption|table|tr|section|article)\s*>/gi, '\n\n')
    .replace(/<br\s*\/?>/gi, '\n')
    .replace(/<hr\s*\/?>/gi, '\n\n')
    .replace(/<[^>]+>/g, ' '), HTML_NAMED_ENTITIES)
    .replace(/ {2,}/g, ' ')
    .replace(/\n{3,}/g, '\n\n')
    .replace(/^[ \t]+/gm, '')
    .replace(/[ \t]+$/gm, '')
    .trim();
}

// Konvertiert eine SYSTEM_*_BLOCKS-Variante (String oder Array aus prompts/core.js)
// in ein Anthropic-Block-Array mit konfigurierbarem Default-TTL. Idempotent für
// Array-Eingaben (TTL-Hints der Eingabe bleiben erhalten). Nutzung in Multi-Block-
// Jobs, die zusätzliche Cache-Blöcke (z.B. Buchtext) prependen wollen:
//
//   const sysBlocks = [bookSystemBlock, ...toSystemBlocks(sys.SYSTEM_X_BLOCKS, '1h')];
//
// Für einfache Job-Sites ohne zusätzliche Blöcke ist der Helper nicht nötig —
// aiCall/callAI verarbeiten String und Array transparent.
function toSystemBlocks(blocksOrString, defaultTtl) {
  if (Array.isArray(blocksOrString)) return blocksOrString;
  if (!blocksOrString) return [];
  return [{ text: blocksOrString, ttl: defaultTtl }];
}

// Mindestabstand zwischen zwei updateJob-Calls aus dem Streaming-onProgress.
// Reduziert Event-Loop-Last bei parallelen KI-Streams; die Live-Anzeige ruckelt
// in der Praxis bei 200 ms nicht sichtbar.
const PROGRESS_THROTTLE_MS = 200;
// Denkphase im Fortschrittsbalken (siehe aiCall): Anteil einer Call-Fraktion, den das
// Denken höchstens füllt, Zeitkonstante der Annäherung (nach TAU ~63 % davon) und
// Tick-Intervall des Timers. TAU grob an einem Opus-5.5-Lektorat-Pass (~1 Min Denken).
const THINK_SHARE = 0.6;
const THINK_TAU_MS = 40000;
const THINK_TICK_MS = 1000;

// Kosten-Aufschlüsselung pro Call-Klasse.
//
// WARUM: das ai_cost_ledger schreibt EINE Zeile pro Job (bewusst — siehe
// db/cost-ledger.js). Damit sieht man, dass ein Komplettanalyse-Lauf teuer war, aber
// nicht WO: Extraktion, Konsolidierung, Kontinuität und Erzählprofil laufen alle in
// demselben Job. Ohne diese Zuordnung ist jede Optimierung Raten — und der Effekt
// einer Änderung (z.B. Extraktion auf ein günstigeres Tier) nicht nachweisbar.
//
// Aggregiert wird in `tok.byPhase` (in-memory, pro Job), NICHT als zweite
// Ledger-Zeile: zwei Schreibpfade würden die Kosten doppelt zählen.
// Der Bucket kommt aus `tier.label`; Calls ohne Label landen unter 'other'.
//
// Läuft VOR dem truncated-Guard — bewusst: Anthropic berechnet die Tokens eines
// abgebrochenen Calls trotzdem, sie gehören also in die Aufschlüsselung. Deshalb
// darf die Buchhaltung aber auch NIEMALS werfen: ein Fehler hier würde die
// eigentliche Job-Exception (z.B. job.error.aiTruncated) verschlucken und durch
// eine unverständliche ersetzen. Gleiche Regel wie in db/cost-ledger.js.
function _recordCallCost(tok, tier, provider, m) {
  try { _recordCallCostUnsafe(tok, tier, provider, m); }
  catch (e) { logger.warn(`Kosten-Aufschluesselung uebersprungen: ${e.message}`); }
}

function _recordCallCostUnsafe(tok, tier, provider, m) {
  if (!tok) return;
  const { model: tierModel, label } = normalizeTier(tier);
  const model = provider === 'claude' ? _resolveClaudeModel(tierModel) : null;
  const usd = costUsd({
    provider, model,
    tokensIn: m.tokensIn, tokensOut: m.tokensOut,
    cacheReadIn: m.cacheReadIn, cacheCreationIn: m.cacheCreationIn,
    cacheCreation1hIn: m.cacheCreation1hIn,
  });
  const bucket = label || 'other';
  tok.byPhase = tok.byPhase || {};
  const e = tok.byPhase[bucket] || (tok.byPhase[bucket] = {
    calls: 0, tokensIn: 0, tokensOut: 0, cacheReadIn: 0, cacheCreationIn: 0, usd: 0, ms: 0, models: [],
  });
  e.calls += 1;
  e.tokensIn += m.tokensIn || 0;
  e.tokensOut += m.tokensOut || 0;
  e.cacheReadIn += m.cacheReadIn || 0;
  e.cacheCreationIn += m.cacheCreationIn || 0;
  e.usd += usd;
  e.ms += m.genDurationMs || 0;
  if (model && !e.models.includes(model)) e.models.push(model);
}

/** Aufbereitete Kosten-Aufschlüsselung fürs Job-Result: teuerster Bucket zuerst,
 *  USD auf Cent gerundet (rohe Floats blähen das Result-JSON auf). Gibt null,
 *  wenn kein Call ein Label trug — also nur noch für Jobs, die gar keine Buckets
 *  setzen. Die Komplettanalyse labelt alle ihre Calls (SSoT
 *  routes/jobs/komplett/cost-labels.js); bei lokalen Providern stehen die Buckets
 *  darum ebenfalls da, nur mit usd = 0 (Calls/Tokens/Sekunden bleiben aussagekräftig). */
function summarizeCostByPhase(tok) {
  const src = tok?.byPhase;
  if (!src || !Object.keys(src).length) return null;
  const phases = Object.entries(src)
    .map(([phase, e]) => ({
      phase, calls: e.calls,
      tokensIn: e.tokensIn, tokensOut: e.tokensOut,
      cacheReadIn: e.cacheReadIn, cacheCreationIn: e.cacheCreationIn,
      usd: Math.round(e.usd * 100) / 100,
      seconds: Math.round(e.ms / 1000),
      models: e.models.slice(),
    }))
    .sort((a, b) => b.usd - a.usd);
  const totalUsd = Math.round(phases.reduce((s, p) => s + p.usd, 0) * 100) / 100;
  return { phases, totalUsd };
}

/** Einzeiler für das Job-Log: `extract 21 calls 512k↓ $12.40 (claude-sonnet-5) | …`. */
function formatCostByPhase(summary) {
  if (!summary) return '';
  return summary.phases
    .map(p => `${p.phase} ${p.calls}c ${fmtTok(p.tokensOut)}↓ $${p.usd.toFixed(2)}${p.models.length ? ` (${p.models.join('+')})` : ''}`)
    .join(' | ');
}

// Hilfsfunktion: callAI aufrufen, Token-Zähler akkumulieren, Job aktualisieren.
// fromPct/toPct: optionaler Fortschrittsbereich – während des Streamings wird der Balken
// von fromPct auf toPct gefüllt (basierend auf akkumulierten Output-Zeichen vs. dynExpectedChars).
// outputRatio: erwartetes Output/Input-Verhältnis für dynamische Recalibrierung (Default 0.2).
//   Sobald tokIn bekannt ist (Claude: message_start; Ollama: erster Chunk), wird dynExpectedChars
//   auf max(staticFallback, tokIn * 4 * outputRatio) gesetzt.
// maxTokens: explizites Token-Limit (überschreibt die expectedChars-Formel). null = globalMax.
// tier: Per-Call-Claude-Tier — nackter Modellname ODER `{ model, effort, label }`
//   (normalizeTier in lib/ai/shared.js). `label` klassifiziert den Call für die
//   Kosten-Aufschlüsselung in `tok.byPhase` → job.result.costByPhase.
async function aiCall(jobId, tok, prompt, system, fromPct, toPct, expectedChars = 3000, outputRatio = 0.2, maxTokens = null, provider = undefined, jsonSchema = null, tier = undefined) {
  let dynExpectedChars = expectedChars;
  let calibrated = false;
  // Eindeutige ID für diesen Call – wird in tok.inflight eingetragen wenn vorhanden
  // (tok.inflight ist ein Map, der nur vom komplett-analyse-Job gesetzt wird, damit
  // bei parallelen Kapitel-Calls die Live-Anzeige alle in-flight-Tokens summiert.)
  const callId = Symbol();
  // Throttle: updateJob höchstens alle PROGRESS_THROTTLE_MS. Bei parallelen Streams
  // (Komplettanalyse) feuert onProgress sonst hunderte Mal/s pro Call und belastet
  // den Event-Loop, sodass andere Clients Requests verzögert bedient werden.
  // Kalibrierung läuft ungedrosselt – sie ist einmalig und braucht die erste tokIn-Meldung.
  // Finale Werte werden nach callAI-Ende ohnehin explizit gesetzt.
  let lastUpdateMs = 0;
  // Denk-Phase (adaptives Thinking, nur Claude): der Provider meldet den Beginn eines
  // Thinking-Blocks, das Ende ist der erste Text. Weitergereicht an den optionalen
  // Hook `tok.onThinking(callId, on)` — der Job entscheidet selbst, ob und wie er die
  // Phase anzeigt; ohne Hook bleibt die Statuszeile unberührt. Ungedrosselt: zwei
  // Übergänge pro Call.
  // Während des Denkens streamt der Provider keinen Text, nur Pings — ein rein
  // zeichenbasierter Balken stünde minutenlang still und spränge dann. Darum rückt
  // die Call-Fraktion in der Denkphase zeitbasiert asymptotisch bis THINK_SHARE vor
  // (Timer, weil keine Events kommen); der gestreamte Text füllt danach den Rest.
  // Monoton in Zeit und Zeichen → der Balken läuft nie rückwärts.
  let thinkingNow = false;
  let thinkStartMs = null;
  let thinkFloor = 0;
  let lastChars = 0;
  let thinkTimer = null;
  const hasRange = !!tok.progressRange || (fromPct != null && toPct != null);
  const thinkShare = () => (thinkStartMs == null ? thinkFloor
    : Math.max(thinkFloor, THINK_SHARE * (1 - Math.exp(-(Date.now() - thinkStartMs) / THINK_TAU_MS))));
  const callFraction = (chars) => {
    const think = thinkShare();
    return think + (1 - think) * Math.min(1, chars / dynExpectedChars);
  };
  const progressValue = (chars) => {
    if (tok.progressRange) {
      // Mehrere Teil-Calls (Lektorat-Split: K Objektiv-Läufe + 1 Stil-Lauf) teilen
      // sich EINEN Fortschrittsbereich. Jeder Call meldet seine eigene Fraktion;
      // der Balken zeigt den Mittelwert über alle erwarteten Calls
      // (progressRange.total) – additiv statt konkurrierend, damit parallele Streams
      // den Balken nicht hin- und herspringen lassen (analog tok.inflight).
      tok.progressParts.set(callId, callFraction(chars));
      const { from, to, total } = tok.progressRange;
      const sum = [...tok.progressParts.values()].reduce((s, v) => s + v, 0);
      return Math.round(from + (to - from) * Math.min(1, sum / total));
    }
    if (fromPct != null && toPct != null) {
      return Math.round(fromPct + (toPct - fromPct) * callFraction(chars));
    }
    return null;
  };
  const setThinking = (on) => {
    if (thinkingNow === on) return;
    thinkingNow = on;
    if (on) {
      thinkStartMs = Date.now();
      if (hasRange && !thinkTimer) {
        thinkTimer = setInterval(() => updateJob(jobId, { progress: progressValue(lastChars) }), THINK_TICK_MS);
        thinkTimer.unref?.();
      }
    } else {
      thinkFloor = thinkShare();
      thinkStartMs = null;
      if (thinkTimer) { clearInterval(thinkTimer); thinkTimer = null; }
    }
    tok.onThinking?.(callId, on);
  };
  const onProgress = ({ chars, tokIn, thinking }) => {
    if (thinking) setThinking(true);
    else if (thinkingNow && chars > 0) setThinking(false);
    lastChars = chars;
    if (!calibrated && tokIn > 0) {
      dynExpectedChars = Math.max(expectedChars, Math.round(tokIn * 4 * outputRatio));
      calibrated = true;
    }
    const now = Date.now();
    if (now - lastUpdateMs < PROGRESS_THROTTLE_MS) return;
    lastUpdateMs = now;

    const updates = {};
    const progress = progressValue(chars);
    if (progress != null) updates.progress = progress;
    if (tok.inflight) {
      const entry = tok.inflight.get(callId) || { tokIn: 0, outEst: 0 };
      tok.inflight.set(callId, {
        tokIn:   tokIn > 0  ? tokIn              : entry.tokIn,
        outEst:  chars > 0  ? Math.floor(chars / CHARS_PER_TOKEN) : entry.outEst,
      });
      const vals = [...tok.inflight.values()];
      if (tokIn > 0) updates.tokensIn  = tok.in  + vals.reduce((s, v) => s + v.tokIn,  0);
      if (chars > 0) updates.tokensOut = tok.out + vals.reduce((s, v) => s + v.outEst, 0);
    } else {
      if (tokIn > 0) updates.tokensIn  = tok.in  + tokIn;
      if (chars > 0) updates.tokensOut = tok.out + Math.floor(chars / CHARS_PER_TOKEN);
    }
    if (Object.keys(updates).length) updateJob(jobId, updates);
  };
  // Output-Ceiling pro Call aus dem TATSAECHLICHEN Provider dieses Calls ableiten,
  // nicht aus dem globalen MAX_TOKENS_OUT (= ai.claude.max_tokens_out). Sonst klemmt
  // der Claude-Cap auch openai-compat/ollama-Jobs runter (z.B. 8000), obwohl der Admin
  // ai.openai-compat.max_tokens_out hoeher gesetzt hat → vorzeitige Truncation.
  // WICHTIG: undefined `provider` zuerst auflösen – exakt so, wie callAI es intern tut
  // (provider || resolveProvider()). Sonst fiele getContextConfigFor auf 'claude' zurück,
  // während callAI den echten Provider (z.B. openai-compat) anspricht → Cap und Call
  // divergieren und der Output wird vorzeitig auf den Claude-Default gekappt.
  const effProvider = provider || resolveProvider();
  const aiCfg = getContextConfigFor(effProvider);
  const providerMaxOut = aiCfg.maxTokensOut;
  const maxTokensOverride = maxTokens != null
    ? Math.min(maxTokens, providerMaxOut)
    : providerMaxOut;
  // Preflight: geschaetzter Input + Output-Cap muessen ins Kontextfenster passen —
  // VOR dem Netzwerk-Call, sonst kommt die Antwort als undurchsichtiger Provider-400
  // (llama.cpp/vLLM) oder als still gekuerzter Prompt (Ollama) zurueck, mitten im Job.
  // Hier, weil ALLE Job-Calls durch aiCall laufen und effProvider/maxTokensOverride
  // an dieser Stelle schon aufgeloest sind. Wirft `job.error.aiContextOverflow`.
  assertPromptFitsContext({
    provider: effProvider,
    cfg: aiCfg,
    maxTokensOut: maxTokensOverride,
    estTokIn: estimatePromptTokens([prompt, system], aiCfg.charsPerToken),
  });
  const signal = jobAbortControllers.get(jobId)?.signal;
  let aiRes;
  try {
    aiRes = await callAI(prompt, system, onProgress, maxTokensOverride, signal, effProvider, jsonSchema, tier);
  } finally {
    setThinking(false);
  }
  const { text, truncated, tokensIn, tokensOut, cacheReadIn = 0, cacheCreationIn = 0, cacheCreation1hIn = 0, genDurationMs } = aiRes;
  tok.inflight?.delete(callId);
  tok.in += tokensIn;
  tok.out += tokensOut;
  tok.cacheRead = (tok.cacheRead || 0) + cacheReadIn;
  tok.cacheCreate = (tok.cacheCreate || 0) + cacheCreationIn;
  tok.cacheCreate1h = (tok.cacheCreate1h || 0) + cacheCreation1hIn;
  if (genDurationMs != null) tok.ms += genDurationMs;
  _recordCallCost(tok, tier, effProvider, {
    tokensIn, tokensOut, cacheReadIn, cacheCreationIn, cacheCreation1hIn, genDurationMs,
  });
  const liveTps = tok.ms > 0 ? tok.out / (tok.ms / 1000) : null;
  const finalUpdates = {
    tokensIn: tok.in, tokensOut: tok.out,
    cacheReadIn: tok.cacheRead, cacheCreationIn: tok.cacheCreate,
    cacheCreation1hIn: tok.cacheCreate1h,
    tokensPerSec: liveTps,
  };
  if (tok.progressRange) {
    // Dieser Teil-Call ist fertig → volle Fraktion, Balken um sein Segment vorrücken.
    tok.progressParts.set(callId, 1);
    const { from, to, total } = tok.progressRange;
    const sum = [...tok.progressParts.values()].reduce((s, v) => s + v, 0);
    finalUpdates.progress = Math.round(from + (to - from) * Math.min(1, sum / total));
  }
  updateJob(jobId, finalUpdates);
  if (truncated) throw i18nError('job.error.aiTruncated', { max: maxTokensOverride, tokIn: tokensIn, tokOut: tokensOut, total: tokensIn + tokensOut });
  return parseJSON(text);
}

module.exports = {
  settledAll,
  retryOnTransientAi, _isTransientAiError,
  HTML_NAMED_ENTITIES, _PROMPT_ENTITY_MAP,
  cleanPageTextForAi, htmlToText, htmlToTextForPrompt,
  PROGRESS_THROTTLE_MS,
  aiCall,
  toSystemBlocks,
  summarizeCostByPhase, formatCostByPhase,
  // Kosten-Bucket für Calls, die nicht durch aiCall laufen können (Tool-Loops mit
  // Server-Tools, z.B. der Faktencheck mit web_search). Wirft nie.
  recordCallCost: _recordCallCost,
};
