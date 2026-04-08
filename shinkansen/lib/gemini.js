// gemini.js — Google Gemini REST API 封裝
// 支援批次翻譯、Service Tier (Flex/Standard/Priority)、除錯 Log。

import { debugLog } from './logger.js';

const DELIMITER = '\n<<<SHINKANSEN_SEP>>>\n';
// v0.37 起改為「段數 + 字元預算」雙門檻（雙重保險層 — content.js 已先打包過）
const MAX_UNITS_PER_CHUNK = 20;
const MAX_CHARS_PER_CHUNK = 3500;
const MAX_BACKOFF_MS = 8000;

/**
 * Greedy 打包：對 texts 陣列用字元預算 + 段數上限雙門檻切成連續子批次，
 * 回傳「起始 index 陣列」讓呼叫端可以對齊結果。
 */
function packChunks(texts) {
  const batches = [];
  let cur = null;
  const flush = () => { if (cur && cur.end > cur.start) batches.push(cur); cur = null; };
  for (let i = 0; i < texts.length; i++) {
    const len = (texts[i] || '').length;
    if (len > MAX_CHARS_PER_CHUNK) {
      flush();
      batches.push({ start: i, end: i + 1 });
      continue;
    }
    if (cur && (cur.chars + len > MAX_CHARS_PER_CHUNK || (cur.end - cur.start) >= MAX_UNITS_PER_CHUNK)) {
      flush();
    }
    if (!cur) cur = { start: i, end: i, chars: 0 };
    cur.end = i + 1;
    cur.chars += len;
  }
  flush();
  return batches;
}

/** 自訂錯誤:RPD 每日配額用盡,不應該被重試。 */
export class DailyQuotaExceededError extends Error {
  constructor(message) {
    super(message);
    this.name = 'DailyQuotaExceededError';
  }
}

function sleep(ms) {
  return new Promise(resolve => setTimeout(resolve, ms));
}

/**
 * 從 Gemini 429 的 response body 找出爆掉的維度(RPM/TPM/RPD)。
 * 若找不到明確線索回傳 null。
 */
function extractQuotaDimension(json) {
  const details = json?.error?.details;
  if (!Array.isArray(details)) return null;
  for (const d of details) {
    const metric = d?.quotaMetric || d?.metric || '';
    const id = d?.quotaId || '';
    const haystack = `${metric} ${id}`.toLowerCase();
    if (haystack.includes('perday') || haystack.includes('_day')) return 'RPD';
    if (haystack.includes('tokens') && haystack.includes('minute')) return 'TPM';
    if (haystack.includes('requests') && haystack.includes('minute')) return 'RPM';
  }
  return null;
}

/**
 * fetch Gemini API,帶 429 退避重試。
 * - 收到 429 → 讀 Retry-After header(秒數)等待後重試
 * - Retry-After 沒給 → 指數退避 2^n * 500ms(上限 8s)
 * - 爆的是 RPD → 丟 DailyQuotaExceededError,不 retry
 * - 重試次數超過 maxRetries → 丟原錯誤
 */
async function fetchWithRetry(url, body, { maxRetries = 3 } = {}) {
  let attempt = 0;
  // eslint-disable-next-line no-constant-condition
  while (true) {
    let resp;
    try {
      resp = await fetch(url, {
        method: 'POST',
        headers: { 'Content-Type': 'application/json' },
        body: JSON.stringify(body),
      });
    } catch (err) {
      await debugLog('error', 'gemini fetch network error', { error: err.message, attempt });
      if (attempt >= maxRetries) throw new Error('網路錯誤：' + err.message);
      await sleep(Math.min(MAX_BACKOFF_MS, 500 * Math.pow(2, attempt)));
      attempt += 1;
      continue;
    }

    if (resp.status !== 429) return resp;

    // 429 處理
    let bodyJson = null;
    try { bodyJson = await resp.clone().json(); } catch { /* noop */ }
    const dim = extractQuotaDimension(bodyJson);
    const retryAfterHeader = resp.headers.get('retry-after');
    const retryAfterSec = retryAfterHeader ? parseInt(retryAfterHeader, 10) : NaN;

    await debugLog('warn', 'gemini 429 rate limit', {
      dimension: dim,
      retryAfter: retryAfterHeader,
      attempt,
      error: bodyJson?.error?.message,
    });

    if (dim === 'RPD') {
      throw new DailyQuotaExceededError('今日 Gemini API 配額已用盡(RPD 達上限),請明天再試或升級付費層級。');
    }

    if (attempt >= maxRetries) {
      const msg = bodyJson?.error?.message || `HTTP 429(${dim || '未知維度'})`;
      throw new Error(msg);
    }

    const waitMs = Number.isFinite(retryAfterSec) && retryAfterSec > 0
      ? retryAfterSec * 1000 + 100
      : Math.min(MAX_BACKOFF_MS, 500 * Math.pow(2, attempt));
    await sleep(waitMs);
    attempt += 1;
  }
}

/**
 * 批次翻譯文字陣列（會自動切成多批送出）。
 * @param {string[]} texts 原文陣列
 * @param {object} settings 完整設定
 * @returns {Promise<{ translations: string[], usage: { inputTokens: number, outputTokens: number, cachedTokens: number } }>}
 *
 * 註：`cachedTokens` 來自 Gemini API 回應的 `usageMetadata.cachedContentTokenCount`，
 * 代表本次輸入中被 Gemini implicit context cache 命中的 token 數。
 * 命中的部分 Gemini 會以全價 25% 計費（2.5 系列 Flash/Pro 預設開啟 implicit cache，
 * 命中條件是 prompt 前綴穩定且達到最低門檻：Flash ~1024、Pro ~2048）。
 * 這個數字跟 `lib/cache.js` 的本地 `tc_<sha1>` 翻譯快取是不同概念 ——
 * 本地快取命中的段落根本不會送 API，而 implicit cache 命中的段落有送 API
 * 但前綴（system prompt 那一大段）被 Gemini 內部 cache 省下。
 */
export async function translateBatch(texts, settings) {
  if (!texts?.length) return { translations: [], usage: { inputTokens: 0, outputTokens: 0, cachedTokens: 0 } };
  const out = new Array(texts.length);
  const usage = { inputTokens: 0, outputTokens: 0, cachedTokens: 0 };
  const chunks = packChunks(texts);
  for (const { start, end } of chunks) {
    const slice = texts.slice(start, end);
    const { parts, usage: u } = await translateChunk(slice, settings);
    for (let j = 0; j < parts.length; j++) out[start + j] = parts[j];
    usage.inputTokens += u.inputTokens;
    usage.outputTokens += u.outputTokens;
    usage.cachedTokens += u.cachedTokens || 0;
  }
  return { translations: out, usage };
}

async function translateChunk(texts, settings) {
  if (!texts?.length) return [];
  const { apiKey, geminiConfig } = settings;
  const {
    model,
    serviceTier,
    temperature,
    topP,
    topK,
    maxOutputTokens,
    systemInstruction,
  } = geminiConfig;

  // 將多段以分隔符合併，單次請求省費用
  const joined = texts.join(DELIMITER);

  // 若本批文字含 ⟦…⟧ 佔位符（content.js 為了保留連結 / 樣式而注入的）,
  // 在 systemInstruction 後面追加一條規則，要求 LLM 原樣保留這些標記。
  let effectiveSystem = systemInstruction;
  if (joined.indexOf('\u27E6') !== -1) {
    effectiveSystem = systemInstruction + '\n\n額外規則（極重要，處理佔位符標記）:\n輸入中可能含有兩種佔位符標記，都是用來保留原文結構，必須原樣保留、不可翻譯、不可省略、不可改寫、不可新增、不可重排。佔位符裡的數字、斜線、星號 **必須是半形 ASCII 字元**（0-9、/、*），絕對不可改成全形（０-９、／、＊），否則程式無法配對會整段崩壞。\n\n（A）配對型 ⟦數字⟧…⟦/數字⟧（例如 ⟦0⟧Tokugawa Ieyasu⟦/0⟧)：\n- 把標記視為透明外殼。外殼「內部」的文字跟外殼「外部」的文字一樣，全部都要翻譯成繁體中文。\n- ⟦數字⟧ 與 ⟦/數字⟧ 兩個標記本身原樣保留，數字不變。\n- **配對型可以巢狀嵌套**（例如 ⟦0⟧may incorporate text from a ⟦1⟧large language model⟦/1⟧, which is ...⟦/0⟧）。巢狀代表原文是 `<b>text <a>link</a> more text</b>` 這類嵌套結構。翻譯時必須**同時**保留外層與內層兩組標記、不可扁平化成單層、不可交換順序、不可遺漏任何一層。外層與內層的內部文字全部要翻成繁體中文。\n\n（B）自閉合 ⟦*數字⟧（例如 ⟦*5⟧)：\n- 這是「原子保留」位置記號，代表原文裡有一段不可翻譯的小區塊（例如維基百科腳註參照 [2])。\n- 整個 ⟦*數字⟧ token 原樣保留，不可拆開、不可翻譯、不可省略，數字不變。\n- 它的位置代表那段內容應該插在譯文的哪裡。\n\n具體範例 1（單層）：\n輸入： ⟦0⟧Tokugawa Ieyasu⟦/0⟧ won the ⟦1⟧Battle of Sekigahara⟦/1⟧ in 1600.⟦*2⟧\n正確輸出： ⟦0⟧德川家康⟦/0⟧於 1600 年贏得⟦1⟧關原之戰⟦/1⟧。⟦*2⟧\n錯誤輸出 1： ⟦0⟧Tokugawa Ieyasu⟦/0⟧於 1600 年贏得⟦1⟧Battle of Sekigahara⟦/1⟧。⟦*2⟧（配對型內部英文沒翻）\n錯誤輸出 2： ⟦0⟧德川家康⟦/0⟧於 1600 年贏得⟦1⟧關原之戰⟦/1⟧。[2]（自閉合 ⟦*2⟧ 被擅自還原成 [2])\n\n具體範例 2（巢狀）：\n輸入： This article ⟦0⟧may incorporate text from a ⟦1⟧large language model⟦/1⟧, which is ⟦2⟧prohibited in Wikipedia articles⟦/2⟧⟦/0⟧.\n正確輸出： 本條目⟦0⟧可能包含來自⟦1⟧大型語言模型⟦/1⟧的文字，這在⟦2⟧維基百科條目中是被禁止的⟦/2⟧⟦/0⟧。\n錯誤輸出 3： 本條目可能包含來自⟦1⟧大型語言模型⟦/1⟧的文字，這在⟦2⟧維基百科條目中是被禁止的⟦/2⟧。（外層 ⟦0⟧…⟦/0⟧ 被扁平化丟掉）';
  }

  const body = {
    contents: [{ role: 'user', parts: [{ text: joined }] }],
    systemInstruction: { parts: [{ text: effectiveSystem }] },
    generationConfig: {
      temperature,
      topP,
      topK,
      maxOutputTokens,
    },
    safetySettings: [
      { category: 'HARM_CATEGORY_HARASSMENT', threshold: 'BLOCK_NONE' },
      { category: 'HARM_CATEGORY_HATE_SPEECH', threshold: 'BLOCK_NONE' },
      { category: 'HARM_CATEGORY_SEXUALLY_EXPLICIT', threshold: 'BLOCK_NONE' },
      { category: 'HARM_CATEGORY_DANGEROUS_CONTENT', threshold: 'BLOCK_NONE' },
    ],
  };

  // 只有在使用者明確選擇 FLEX/STANDARD/PRIORITY 時才送 serviceTier。
  // 若為 'DEFAULT' 或空值則完全不送此欄位，避免舊模型拒絕。
  if (serviceTier && serviceTier !== 'DEFAULT') {
    body.serviceTier = serviceTier; // 短形式：FLEX / STANDARD / PRIORITY
  }

  const url = `https://generativelanguage.googleapis.com/v1beta/models/${encodeURIComponent(model)}:generateContent?key=${encodeURIComponent(apiKey)}`;

  await debugLog('info', 'gemini request', { model, serviceTier, segments: texts.length });

  const t0 = Date.now();
  const maxRetries = typeof settings?.maxRetries === 'number' ? settings.maxRetries : 3;
  const resp = await fetchWithRetry(url, body, { maxRetries });

  const json = await resp.json();
  const ms = Date.now() - t0;

  if (!resp.ok) {
    await debugLog('error', 'gemini error', { status: resp.status, json, ms });
    const msg = json?.error?.message || `HTTP ${resp.status}`;
    throw new Error(msg);
  }

  const text = json?.candidates?.[0]?.content?.parts?.[0]?.text || '';
  const meta = json?.usageMetadata || {};
  const chunkUsage = {
    inputTokens: meta.promptTokenCount || 0,
    outputTokens: meta.candidatesTokenCount || 0,
    // Gemini 2.5+ implicit context caching 命中的 token 數（輸入 tokens 的子集）。
    // 未命中或舊模型時欄位不會出現，用 || 0 防呆。
    cachedTokens: meta.cachedContentTokenCount || 0,
  };
  await debugLog('info', 'gemini response', {
    ms,
    usage: meta,
    preview: text.slice(0, 200),
  });

  const parts = text.split(DELIMITER).map(s => s.trim());
  // 若回傳段數不符，且本批不只一段，則 fallback 改為逐段單獨翻譯，確保對齊
  if (parts.length !== texts.length) {
    await debugLog('warn', 'segment count mismatch — fallback to per-segment', {
      expected: texts.length, got: parts.length,
    });
    if (texts.length === 1) {
      // 單段模式：直接回傳整個 text(LLM 可能多吐了分隔符）
      return { parts: [text.trim()], usage: chunkUsage };
    }
    // 逐段 fallback：每段都會真的再打一次 API，需累加 usage
    // 注意：此時原本這一批的 chunkUsage 已經付過錢了，但結果沒法對齊要丟掉，
    // 所以還是要算進總成本裡。
    const aligned = [];
    const aggUsage = { ...chunkUsage };
    for (const seg of texts) {
      const r = await translateChunk([seg], settings);
      aligned.push(r.parts[0] || '');
      aggUsage.inputTokens += r.usage.inputTokens;
      aggUsage.outputTokens += r.usage.outputTokens;
      aggUsage.cachedTokens += r.usage.cachedTokens || 0;
    }
    return { parts: aligned, usage: aggUsage };
  }
  return { parts, usage: chunkUsage };
}
