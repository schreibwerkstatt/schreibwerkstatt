'use strict';
// Claude-Provider (Anthropic Messages API): Streaming-Calls (Text + Tool-Use),
// Prompt-Caching-Blocks, Retry/Backoff bei Overload/Rate-Limit, Timeout-Signal,
// Modell-spezifische Sampling/Thinking/Effort-Parameter (aus config.js).

const appSettings = require('../app-settings');
const logger = require('../../logger');
const {
  _resolveClaudeModel, _resolveClaudeContextWindow, _resolveClaudeMaxOut, _claudeModelMaxOut,
  _claudeSamplingParams, _claudeThinkingParams, _claudeOutputConfigParams,
  _claudeSupportsStructuredOutputs, jobOverride,
} = require('./config');
const {
  normalizeTier, combineSignals, timeoutError, withOverloadRetry,
  parseRetryAfter: _parseRetryAfter, overloadError,
} = require('./shared');
const { aiApiKey } = require('./profile');

// Claude-API liefert 529 (Overloaded) und 429 (Rate-Limit) als transiente Fehler. Beide
// retryen mit Exponential-Backoff (1s/2s/4s + Jitter). Stream-`overloaded_error` retried
// nur, wenn noch kein Text/Block emittiert wurde (sonst würde Output dupliziert).
// 503 mit `error.type === 'overloaded_error'` (z. B. "API key validation is temporarily
// unavailable") ist ebenfalls transient – Detection nicht über Status, sondern über
// den Body-Typ (siehe `_isOverloadedBody`).
const RETRY_STATUS = new Set([429, 529]);
function _retryMaxAttempts() {
  return parseInt(appSettings.get('ai.claude.retry_max'), 10) || 3;
}

function _isOverloadedBody(rawText) {
  if (!rawText) return false;
  try {
    const parsed = JSON.parse(rawText);
    return parsed?.error?.type === 'overloaded_error';
  } catch {
    return false;
  }
}

const _overloadError = (status, retryAfterSec, message) =>
  overloadError('Claude', status, retryAfterSec, message);

// Hard-Timeout pro Claude-Call. Schützt gegen hängende Streams (z.B. wenn die
// Anthropic-API die Verbindung stumm hält). User-Cancel (signal) bleibt zusätzlich aktiv.
// Per-Job-Override aus dem ALS-Bag (`aiJob.timeoutMs`, siehe config.js#jobOverride) >
// globaler ai.claude.timeout_ms > Default. Die Komplettanalyse setzt den Override, weil
// Opus langsamer ist und der Single-Pass mehrere grosse Calls macht – analog zu
// Modell/Kontext/Output.
function _claudeTimeoutMs() {
  return Number(jobOverride('claude', 'timeoutMs'))
    || parseInt(appSettings.get('ai.claude.timeout_ms'), 10) || 600000;
}

// Beta-Feature-Header für Claude. Das 1M-Kontextfenster (Input > 200K Tokens)
// ist hinter dem `context-1m-2025-08-07`-Beta gated; ohne ihn lehnt die API
// Requests mit context_window > 200K ab. Greift automatisch, sobald
// ai.claude.context_window > 200000 gesetzt ist (Sonnet 4.x und Opus 4.6+ tragen 1M).
function _claudeBetaHeader() {
  const betas = ['prompt-caching-2024-07-31', 'extended-cache-ttl-2025-04-11'];
  if (_resolveClaudeContextWindow() > 200000) betas.push('context-1m-2025-08-07');
  return betas.join(',');
}

/**
 * Baut Claude-system-Blocks aus String oder Array.
 * String  → ein cache_control-Block (5-min-TTL, Default-Verhalten).
 * Array   → je Eintrag ein Block; {text, ttl?} – ttl:'1h' nutzt den Extended-TTL-Beta.
 *           Mehrere Blöcke = mehrere Cache-Breakpoints (z.B. [Buchtext(1h), Phase-System(5min)]).
 */
function _buildClaudeSystemBlocks(systemPrompt) {
  if (!systemPrompt) return null;
  if (typeof systemPrompt === 'string') {
    return [{ type: 'text', text: systemPrompt, cache_control: { type: 'ephemeral' } }];
  }
  if (Array.isArray(systemPrompt) && systemPrompt.length > 0) {
    return systemPrompt.map(b => {
      // cache:false → volatiler Block OHNE Breakpoint (z.B. die pro Query neu
      // keyword-selektierten Buchseiten im klassischen Buch-Chat). Ein Breakpoint
      // hier wäre ein cache_write, der nie gelesen wird, weil der Block jede Runde
      // andere Bytes trägt. Der Block muss am Ende des Arrays stehen (Präfix-Match).
      if (b.cache === false) return { type: 'text', text: b.text };
      return {
        type: 'text',
        text: b.text,
        cache_control: b.ttl === '1h'
          ? { type: 'ephemeral', ttl: '1h' }
          : { type: 'ephemeral' },
      };
    });
  }
  return null;
}

// Multi-Turn-Caching für den Tool-Use-Loop: setzt einen Cache-Breakpoint auf den
// letzten Content-Block der letzten Nachricht. Pro Iteration wächst die Message-Liste
// (assistant tool_use + user tool_result); ohne Breakpoint wird die ganze History
// jede Runde voll bezahlt. Mit Breakpoint liest Iteration N+1 den Präfix bis Iteration N
// aus dem Cache (Render-Order tools→system→messages; System hat bereits einen Breakpoint,
// macht zusammen 2 von max 4). Klont nur die betroffene Nachricht — die Original-`messages`
// (vom Loop wiederverwendet + persistiert) bleiben unangetastet. String-Content wird in
// einen text-Block mit cache_control gewandelt.
function _withCacheBreakpointOnLastMessage(messages) {
  if (!Array.isArray(messages) || messages.length === 0) return messages;
  const out = messages.slice();
  const i = out.length - 1;
  const last = out[i];
  const cc = { type: 'ephemeral' };
  if (typeof last.content === 'string') {
    out[i] = { ...last, content: [{ type: 'text', text: last.content, cache_control: cc }] };
  } else if (Array.isArray(last.content) && last.content.length > 0) {
    const blocks = last.content.slice();
    const bi = blocks.length - 1;
    blocks[bi] = { ...blocks[bi], cache_control: cc };
    out[i] = { ...last, content: blocks };
  }
  return out;
}

// Geteilter 1h-Präfix: der vorderste System-Block ist ausdrücklich als solcher markiert
// (`{ sharedPrefix: true, ttl: '1h' }` — Buch-/Kapiteltext-Block der Komplettanalyse,
// den viele Pässe mit je eigenem Schema lesen) → KEIN output_config.format.
// Structured Outputs gehören zum Cache-Präfix — ein anderes Schema je Pass bricht den
// Cache, und jeder Pass schreibt den ganzen Block neu (1h-Write = 2× Input-Preis; in
// der Komplettanalyse ~13 Buch-Writes pro Lauf statt einem). JSON erzwingt dort der
// Systemprompt (JSON_ONLY + Schema-Text); das Schema bleibt am Call für andere
// Provider (Grammar) und für die Pflichtfeld-Prüfung des Aufrufers.
// Bewusst eine Markierung statt «erster Block ist 1h»: die `SYSTEM_*_BLOCKS` mit
// Autorenkontext beginnen auch mit einem 1h-Block, ihre Calls (Lektorat, Review …)
// behalten Structured Outputs.
function _isSharedPrefixSystem(systemPrompt) {
  const first = Array.isArray(systemPrompt) ? systemPrompt[0] : null;
  return !!(first && first.sharedPrefix && first.ttl === '1h');
}

const CLAUDE_URL = 'https://api.anthropic.com/v1/messages';

/**
 * Ein Claude-Streaming-Request als Event-Iterator: POST, HTTP-Fehler-Klassifikation,
 * SSE-Zeilen → geparste Events. Hard-Timeout (`combineSignals`) deckt fetch UND
 * Stream; ein Timeout — auch mitten im `reader.read()` — wirft `AI_TIMEOUT`
 * (transient, `routes/jobs/shared/ai.js#_isTransientAiError`), ein User-Abbruch
 * bleibt AbortError. `sentFormat`: Structured-Output-Format wurde mitgeschickt →
 * eine 400 mit Schema-Hinweis wird zu `AI_STRUCTURED_OUTPUT_UNSUPPORTED`.
 * `error`-Events reicht der Iterator durch — ob ein Stream-Overload retrybar ist,
 * haengt am bereits emittierten Inhalt und entscheidet darum der Reducer.
 */
async function* _claudeStreamEvents(body, signal, { sentFormat = false } = {}) {
  const timeoutMs = _claudeTimeoutMs();
  const { signal: combinedSignal, cleanup, state: signalState } = combineSignals(signal, timeoutMs, 'Claude');
  const asTimeout = (e) => (signalState.timedOut ? timeoutError('Claude', timeoutMs) : e);
  try {
    let resp;
    try {
      resp = await fetch(CLAUDE_URL, {
        method: 'POST',
        headers: {
          'Content-Type': 'application/json',
          'x-api-key': aiApiKey('claude'),
          'anthropic-version': '2023-06-01',
          'anthropic-beta': _claudeBetaHeader(),
        },
        body: JSON.stringify(body),
        signal: combinedSignal,
      });
    } catch (e) {
      throw asTimeout(e);
    }
    if (!resp.ok) {
      const detail = await resp.text().catch(() => '');
      if (RETRY_STATUS.has(resp.status) || _isOverloadedBody(detail)) {
        const ra = _parseRetryAfter(resp);
        throw _overloadError(resp.status, ra, `Claude ${resp.status}: ${detail.slice(0, 300)}`);
      }
      // Structured-Output-Ablehnung (nur wenn wir format tatsächlich gesendet haben):
      // eigener Code, damit _callClaude einmalig ohne output_config.format retryt statt
      // den Job non-retryable zu killen. Nur bei 400 + einschlägigem Body-Hinweis.
      if (resp.status === 400 && sentFormat && /output_config|json_schema|\bschema\b|\bformat\b/i.test(detail)) {
        const err = new Error(`Claude 400 (structured output): ${detail.slice(0, 200)}`);
        err.code = 'AI_STRUCTURED_OUTPUT_UNSUPPORTED';
        throw err;
      }
      throw new Error(`Claude ${resp.status}: ${detail || resp.statusText}`);
    }

    const reader = resp.body.getReader();
    const dec = new TextDecoder();
    let buf = '';
    for (;;) {
      let chunk;
      try { chunk = await reader.read(); }
      catch (e) { throw asTimeout(e); }
      if (chunk.done) return;
      buf += dec.decode(chunk.value, { stream: true });
      const lines = buf.split('\n');
      buf = lines.pop();
      for (const line of lines) {
        if (!line.startsWith('data: ')) continue;
        const raw = line.slice(6);
        if (raw === '[DONE]') return;
        let ev;
        try { ev = JSON.parse(raw); } catch { continue; }
        yield ev;
      }
    }
  } finally {
    cleanup();
  }
}

/** Stream-`error`-Event → Fehler. Overload ist nur retrybar, solange noch nichts
 *  emittiert wurde (`emitted === false`), sonst wuerde Output dupliziert. */
function _streamError(ev, emitted) {
  if (ev.error?.type === 'overloaded_error' && !emitted) {
    return _overloadError(null, null, `Claude Stream-Fehler: overloaded_error – ${ev.error?.message || ''}`);
  }
  return new Error(`Claude Stream-Fehler: ${ev.error?.type} – ${ev.error?.message}`);
}

/** Usage + Stop-Grund + Generierungsdauer, gemeinsam fuer Text- und Tool-Pfad.
 *  `onEvent` liefert 'usage', wenn message_start die Input-Tokens gesetzt hat.
 *  Das Generierungsfenster umfasst JEDES content_block_*-Event (Thinking, Text,
 *  Tool-Input, Signatur): `output_tokens` zaehlt die Denk-Tokens mit, und bei
 *  display:'omitted' streamt der Denk-Block nur Start + signature_delta. Ein Fenster
 *  nur ueber text_delta teilte Denk- plus Text-Tokens durch die reine Textzeit und
 *  blaeht tok/s auf. */
function _makeUsageAcc() {
  return {
    tokensIn: 0, tokensOut: 0, cacheReadIn: 0, cacheCreationIn: 0, cacheCreation1hIn: 0,
    truncated: false, stopReason: null, t_first: 0, t_last: 0,
    onEvent(ev) {
      if (typeof ev.type === 'string' && ev.type.startsWith('content_block_')) this.markOutput();
      if (ev.type === 'message_start' && ev.message?.usage) {
        const u = ev.message.usage;
        this.cacheCreationIn = u.cache_creation_input_tokens || 0;
        // 1h-TTL-Writes kosten 2x statt 1.25x (5min) — Anteil separat fuer costUsd.
        // cacheCreationIn bleibt das TTL-uebergreifende Total (Anzeige-Kompatibilitaet).
        this.cacheCreation1hIn = u.cache_creation?.ephemeral_1h_input_tokens || 0;
        this.cacheReadIn = u.cache_read_input_tokens || 0;
        this.tokensIn = (u.input_tokens || 0) + this.cacheCreationIn + this.cacheReadIn;
        return 'usage';
      }
      if (ev.type === 'message_delta') {
        if (ev.usage?.output_tokens != null) this.tokensOut = ev.usage.output_tokens;
        if (ev.delta?.stop_reason) this.stopReason = ev.delta.stop_reason;
        if (ev.delta?.stop_reason === 'max_tokens') this.truncated = true;
      }
      return null;
    },
    markOutput() {
      const now = Date.now();
      if (!this.t_first) this.t_first = now;
      this.t_last = now;
    },
    result() {
      const { tokensIn, tokensOut, cacheReadIn, cacheCreationIn, cacheCreation1hIn, truncated, stopReason, t_first, t_last } = this;
      const genDurationMs = (t_first && t_last > t_first) ? t_last - t_first : null;
      return { tokensIn, tokensOut, cacheReadIn, cacheCreationIn, cacheCreation1hIn, truncated, stopReason, genDurationMs };
    },
  };
}

// cacheLastMessage: setzt einen Cache-Breakpoint auf die letzte Message
// (_withCacheBreakpointOnLastMessage). Nur sinnvoll für Multi-Turn-Chats mit
// über die Turns STABILEM System-Prompt (Seiten-Chat) — dann liest Turn N+1 die
// bisherige Konversation aus dem Cache. Bei volatilem System (klassischer
// Buch-Chat: Seiten pro Query neu selektiert) bringt es nichts, weil eine
// System-Änderung den Messages-Cache ohnehin invalidiert.
// jsonSchema: optionales JSON-Schema. Bei unterstützten Modellen (Opus 4.7+/Sonnet 5/
// Fable/Haiku 4.5/Legacy-Opus, siehe _claudeSupportsStructuredOutputs) wird es als
// output_config.format = json_schema gesendet (Structured Outputs) → garantiert schema-
// valides JSON, kein Prosa-Leak durch adaptive Thinking, kein jsonrepair-Partial-Risiko.
// Lehnt die API es mit HTTP 400 ab (Schema-Grenzverletzung, Modell doch nicht unterstützt),
// wird der Call EINMALIG ohne output_config.format wiederholt statt den Job
// non-retryable zu killen. Der Fallback zählt nicht gegen das Overload-Budget.
function _callClaude(messages, systemPrompt, onProgress, maxTokensOverride, signal, cacheLastMessage, tier, jsonSchema) {
  let schema = jsonSchema || null;
  return withOverloadRetry(async () => {
    try {
      return await _callClaudeAttempt(messages, systemPrompt, onProgress, maxTokensOverride, signal, cacheLastMessage, tier, schema);
    } catch (e) {
      if (e?.code !== 'AI_STRUCTURED_OUTPUT_UNSUPPORTED' || !schema) throw e;
      schema = null;
      logger.warn(`Claude Structured-Output abgelehnt (${(e.message || '').slice(0, 140)}) – Retry ohne output_config.format.`);
      return await _callClaudeAttempt(messages, systemPrompt, onProgress, maxTokensOverride, signal, cacheLastMessage, tier, null);
    }
  }, { label: 'Claude overload', maxAttempts: _retryMaxAttempts(), signal });
}

async function _callClaudeAttempt(messages, systemPrompt, onProgress, maxTokensOverride, signal, cacheLastMessage, tier, jsonSchema) {
  // Per-Call-Tier (Modell + Effort), siehe normalizeTier in ./shared: die
  // Komplettanalyse routet Extraktion und Konsolidierung parallel auf verschiedene
  // Modelle/Denk-Tiefen, darum darf hier NICHTS aus dem geteilten ALS-Store gepatcht
  // werden. Ohne Tier bleibt es beim ALS-/Setting-Wert (unverändertes Verhalten).
  const { model: tierModel, effort: tierEffort } = normalizeTier(tier);
  const model = _resolveClaudeModel(tierModel);
  // Konfigurierten/Override-Output-Cap zusätzlich aufs harte Modell-Ceiling klemmen
  // (sonst HTTP 400 → non-retryable Job-Kill bei zu hoch gesetztem max_tokens_out).
  const globalMax = Math.min(_resolveClaudeMaxOut(), _claudeModelMaxOut(model));
  const maxTokens = maxTokensOverride ? Math.min(maxTokensOverride, globalMax) : globalMax;
  // output_config kombiniert Effort (ai.claude.effort.* via ALS) und – bei unterstützten
  // Modellen mit Schema – Structured Outputs (format). Beide sind Geschwister-Keys.
  const sentFormat = !!(jsonSchema && _claudeSupportsStructuredOutputs(model)) && !_isSharedPrefixSystem(systemPrompt);
  const outputConfig = { ...(_claudeOutputConfigParams(model, tierEffort).output_config || {}) };
  if (sentFormat) outputConfig.format = { type: 'json_schema', schema: jsonSchema };
  const body = {
    model, max_tokens: maxTokens,
    ..._claudeSamplingParams(model),
    ..._claudeThinkingParams(model),
    ...(Object.keys(outputConfig).length ? { output_config: outputConfig } : {}),
    messages: cacheLastMessage ? _withCacheBreakpointOnLastMessage(messages) : messages,
    stream: true,
  };
  const sysBlocks = _buildClaudeSystemBlocks(systemPrompt);
  if (sysBlocks) body.system = sysBlocks;

  const acc = _makeUsageAcc();
  let text = '';
  for await (const ev of _claudeStreamEvents(body, signal, { sentFormat })) {
    if (ev.type === 'error') throw _streamError(ev, text.length > 0);
    if (acc.onEvent(ev) === 'usage' && onProgress) onProgress({ chars: text.length, tokIn: acc.tokensIn });
    // Adaptives Denken streamt (display 'omitted') bis zum ersten Text nur Pings —
    // ohne dieses Signal sieht ein minutenlanger Denk-Block wie ein Hänger aus.
    if (ev.type === 'content_block_start' && ev.content_block?.type === 'thinking') {
      if (onProgress) onProgress({ chars: text.length, tokIn: acc.tokensIn, thinking: true });
    }
    if (ev.type === 'content_block_delta' && ev.delta?.type === 'text_delta') {
      const delta = ev.delta.text || '';
      text += delta;
      if (onProgress) onProgress({ chars: text.length, tokIn: acc.tokensIn, delta });
    }
  }
  const r = acc.result();
  return {
    text, truncated: r.truncated, tokensIn: r.tokensIn, tokensOut: r.tokensOut,
    cacheReadIn: r.cacheReadIn, cacheCreationIn: r.cacheCreationIn, cacheCreation1hIn: r.cacheCreation1hIn,
    genDurationMs: r.genDurationMs, stopReason: r.stopReason, provider: 'claude', model,
  };
}

// ── Tool-Use (Anthropic Messages API) ──────────────────────────────────────
// Einzelner Round-Trip mit Tool-Use. Der Caller (Job-Runner) verwaltet den Loop:
// wenn stopReason === 'tool_use' muss er die Tools ausführen, Results als
// tool_result-Blocks an die messages anhängen und erneut aufrufen.
//
// Rückgabe:
//   { text, toolUses, stopReason, rawContentBlocks, tokensIn, tokensOut, genDurationMs, truncated }
//   - text: kumulierter Text aller text_delta-Blocks (kann leer sein bei reiner Tool-Antwort)
//   - toolUses: [{ id, name, input }] mit bereits geparstem input (Objekt)
//   - stopReason: 'end_turn' | 'tool_use' | 'max_tokens' | ...
//   - rawContentBlocks: Original-Content-Blocks (text+tool_use) für die nächste Runde
function _callClaudeWithTools(messages, systemPrompt, tools, onProgress, maxTokensOverride, signal) {
  return withOverloadRetry(
    () => _callClaudeWithToolsAttempt(messages, systemPrompt, tools, onProgress, maxTokensOverride, signal),
    { label: 'Claude overload', maxAttempts: _retryMaxAttempts(), signal },
  );
}

// content_block_start → Akkumulator-Eintrag (per Index adressiert). null = ignorieren.
function _startBlock(cb) {
  if (cb.type === 'tool_use') return { type: 'tool_use', id: cb.id, name: cb.name, _inputJson: '' };
  // Server-Tool (z.B. web_search): Input kommt wie bei tool_use via
  // input_json_delta. Wird NICHT vom Caller ausgeführt — Anthropic führt es
  // serverseitig in derselben Runde aus. Block muss aber in rawContentBlocks
  // erhalten bleiben, falls das Modell daneben ein Custom-Tool ruft (Re-Send).
  if (cb.type === 'server_tool_use') return { type: 'server_tool_use', id: cb.id, name: cb.name, _inputJson: '' };
  // Server-Tool-Ergebnis: kommt vollständig im content_block_start (keine
  // Deltas). Verbatim erhalten — gehört beim Re-Send zur assistant-Runde.
  if (cb.type === 'web_search_tool_result') return { type: 'web_search_tool_result', tool_use_id: cb.tool_use_id, content: cb.content };
  if (cb.type === 'text') return { type: 'text', text: '' };
  // Adaptive Thinking (Opus 4.7+): Thinking-Block samt `signature` MUSS in der
  // nächsten Runde als erster Block des assistant-Turns zurückgespielt werden,
  // sonst 400 ("assistant message must start with a thinking block"). Bei
  // display:'omitted' (Default) bleibt `thinking` leer, die signature kommt
  // trotzdem via signature_delta — beides wird in rawContentBlocks erhalten.
  if (cb.type === 'thinking') return { type: 'thinking', thinking: cb.thinking || '', signature: cb.signature || '' };
  if (cb.type === 'redacted_thinking') return { type: 'redacted_thinking', data: cb.data || '' };
  return null;
}

async function _callClaudeWithToolsAttempt(messages, systemPrompt, tools, onProgress, maxTokensOverride, signal) {
  const model = _resolveClaudeModel();
  // Output-Cap aufs harte Modell-Ceiling klemmen (siehe _callClaudeAttempt / _claudeModelMaxOut).
  const globalMax = Math.min(_resolveClaudeMaxOut(), _claudeModelMaxOut(model));
  const maxTokens = maxTokensOverride ? Math.min(maxTokensOverride, globalMax) : globalMax;
  const body = {
    model, max_tokens: maxTokens,
    ..._claudeSamplingParams(model),
    ..._claudeThinkingParams(model),
    ..._claudeOutputConfigParams(model),
    messages: _withCacheBreakpointOnLastMessage(messages), stream: true,
  };
  const sysBlocks = _buildClaudeSystemBlocks(systemPrompt);
  if (sysBlocks) body.system = sysBlocks;
  if (Array.isArray(tools) && tools.length) body.tools = tools;

  // Content-Blocks werden per Index addressiert (content_block_start/delta/stop).
  // Jeder Block ist entweder text oder tool_use; bei tool_use wird input_json
  // in deltas geliefert und muss akkumuliert werden.
  const blocks = []; // [{ type:'text', text } | { type:'tool_use', id, name, _inputJson }]
  const acc = _makeUsageAcc();
  let textAcc = '';
  // Werkzeug-Eingaben zählen live mit: Plot-/Ideen-Chat liefern ihre Antwort fast
  // ganz als final_answer/propose_*-Input — nur über text_delta stünde die
  // Output-Anzeige bis zum Rundenende still (der echte Wert kommt aus message_delta).
  let toolInputChars = 0;
  const outChars = () => textAcc.length + toolInputChars;
  for await (const ev of _claudeStreamEvents(body, signal)) {
    if (ev.type === 'error') throw _streamError(ev, textAcc.length > 0 || blocks.some(Boolean));
    if (acc.onEvent(ev) === 'usage' && onProgress) onProgress({ chars: outChars(), tokIn: acc.tokensIn });
    if (ev.type === 'content_block_start') {
      const b = _startBlock(ev.content_block || {});
      if (b) blocks[ev.index] = b;
    }
    if (ev.type === 'content_block_delta') {
      const d = ev.delta || {};
      const b = blocks[ev.index];
      if (!b) continue;
      if (d.type === 'text_delta') {
        b.text += d.text || '';
        textAcc += d.text || '';
        if (onProgress) onProgress({ chars: outChars(), tokIn: acc.tokensIn });
      } else if (d.type === 'input_json_delta') {
        b._inputJson += d.partial_json || '';
        toolInputChars += (d.partial_json || '').length;
        if (onProgress) onProgress({ chars: outChars(), tokIn: acc.tokensIn });
      } else if (d.type === 'thinking_delta') {
        b.thinking += d.thinking || '';
      } else if (d.type === 'signature_delta') {
        b.signature += d.signature || '';
      }
    }
    if (ev.type === 'content_block_stop') {
      // tool_use / server_tool_use: akkumuliertes input-JSON parsen (kann leer sein → {})
      const b = blocks[ev.index];
      if (b && (b.type === 'tool_use' || b.type === 'server_tool_use')) {
        try { b.input = b._inputJson ? JSON.parse(b._inputJson) : {}; }
        catch (e) { b.input = {}; b.parseError = e.message; }
        delete b._inputJson;
      }
    }
  }
  const toolUses = blocks.filter(b => b && b.type === 'tool_use').map(b => ({
    id: b.id, name: b.name, input: b.input || {}, ...(b.parseError ? { parseError: b.parseError } : {}),
  }));
  const rawContentBlocks = blocks.filter(Boolean).map(b => {
    if (b.type === 'thinking') return { type: 'thinking', thinking: b.thinking, signature: b.signature };
    if (b.type === 'redacted_thinking') return { type: 'redacted_thinking', data: b.data };
    if (b.type === 'text') return { type: 'text', text: b.text };
    // Server-Tool-Blöcke (web_search) verbatim erhalten — Anthropic verlangt sie
    // beim Re-Send als Teil der assistant-Runde, falls daneben ein Custom-Tool lief.
    if (b.type === 'server_tool_use') return { type: 'server_tool_use', id: b.id, name: b.name, input: b.input || {} };
    if (b.type === 'web_search_tool_result') return { type: 'web_search_tool_result', tool_use_id: b.tool_use_id, content: b.content };
    return { type: 'tool_use', id: b.id, name: b.name, input: b.input || {} };
  });
  const r = acc.result();
  return {
    text: textAcc, toolUses, stopReason: r.stopReason, rawContentBlocks,
    tokensIn: r.tokensIn, tokensOut: r.tokensOut, cacheReadIn: r.cacheReadIn,
    cacheCreationIn: r.cacheCreationIn, cacheCreation1hIn: r.cacheCreation1hIn,
    genDurationMs: r.genDurationMs, truncated: r.truncated, provider: 'claude', model,
  };
}

module.exports = { _callClaude, _callClaudeWithTools, _claudeStreamEvents };
