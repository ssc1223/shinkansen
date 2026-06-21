// system-instruction.js — 跨 provider 共用的翻譯 batch 構建 helper(v1.5.7 起)
//
// 從 lib/gemini.js 抽出,讓 Gemini 與 OpenAI-compatible 兩條 adapter 共用同一份:
//   1. DELIMITER:多段串接分隔符
//   2. packChunks:依字元預算 + 段數雙門檻 greedy 分批
//   3. buildEffectiveSystemInstruction:依批次內容動態追加規則
//      (段內換行規則 / 佔位符規則 / fixedGlossary / 中國用語黑名單 /
//       自動 glossary / 多段分隔符規則)
//
// 抽出原因:自訂 OpenAI-compat provider 也要繼承「黑名單 + 固定術語表」自動注入
//          (依 Jimmy 設計決定 #3:systemPrompt 獨立、黑名單 & 固定術語表共用)。
//          改放 lib/ 共用模組讓 Gemini 與 OpenAI-compat 兩個 adapter 同步演進,
//          未來新加翻譯規則只改一處。
//
// 順序設計(v1.8.39 起,為 Gemini implicit cache hit rate 重排):
//   prefix 共享度由高到低,動態變動部分推到最末。
//   baseSystem(完全固定)→ 段內換行(條件性,頁內穩定)→ 佔位符(條件性,頁內穩定)
//   → fixedGlossary(使用者級固定)→ forbiddenTerms(使用者級固定)
//   → glossary(頁面級,跨頁變)→ 多段分隔符規則(嵌入 batch 段數 N,batch 級變)。
//   把 N 嵌入的「本批次包含 N 段」這條規則從第 2 位推到最末端,讓所有 batch 共享前段
//   prefix(原本只能共享 baseSystem ~1500 tokens,新排法可達 ~2000 tokens)。
//   trade-off:forbiddenTerms 不再「最末端」,LLM 注意力略降——靠 regression
//   spec(forbidden-terms-leak / multi-segment 系列)監測。

import { DEFAULT_UNITS_PER_BATCH, DEFAULT_CHARS_PER_BATCH } from './constants.js';

/** 多段翻譯時用此 delimiter 串接 / 拆回對齊。Gemini 與 OpenAI-compat 共用。 */
export const DELIMITER = '\n<<<SHINKANSEN_SEP>>>\n';
// v1.9.22: split-time tolerance — Gemini Flash Lite 經常把 DELIMITER 兩邊的 `\n` 吃掉,
// 還原成 `<<<SHINKANSEN_SEP>>>`(無換行)或 ` <<<SHINKANSEN_SEP>>> `(空格替代)等變體。
// 用嚴格 `text.split(DELIMITER)` 找不到匹配 → parts.length===1 → segment count mismatch
// → 觸發 per-segment fallback(每段一個獨立 API call,慢且燒 token)。
// 改用 SEP_RE(兩側 `\s*`)接受所有空白變體;`\s*` 包含 0 個字元,連 `abc<<<SHINKANSEN_SEP>>>def`
// 也能正確切。每段 .trim() 過,前後空白損失無影響。實測這個 fix 把 ASR 字幕 mismatch 率
// 從 ~46% 砍到接近 0%。
export const SEP_RE = /\s*<<<SHINKANSEN_SEP>>>\s*/;

// 多段序號標記。為什麼有兩組:
//   Gemini / 商用 LLM(GPT / Claude / DeepSeek 等)用緊湊的 «N»,token 開銷小。
//   本機量化模型(gemma-4 量化版等)會把 «1» «2» 當自然語言誤翻成「N1、N2」洩漏到譯文,
//   改用長形式 <<<SHINKANSEN_SEG-N>>> 弱模型認得是協定 token 不會誤翻,代價是
//   每段批次多約 7 tokens / segment(input + output 雙倍開銷)。
// 自訂 Provider 走 useStrongSegMarker toggle 切換(預設 STRONG),Gemini 主路徑固定用 COMPACT。
//
// fmt(n)        生成第 n 段的 marker 字串(內含尾部空白方便 join)
// re            移除 LLM 譯文開頭殘留 marker 的 regex(行首 + 可選空白)
// stripGlobalRe 全文掃 marker 殘留的 regex(防禦 sanitize 用,跨段位置任何地方)
// display       prompt 描述句裡顯示給 LLM 看的「N 範本」
export const MARKER_COMPACT = {
  fmt: (n) => `«${n}» `,
  re: /^«\d+»\s*/,
  stripGlobalRe: /«\d+»\s*/g,
  display: '«N»',
};
export const MARKER_STRONG = {
  fmt: (n) => `<<<SHINKANSEN_SEG-${n}>>> `,
  re: /^<<<SHINKANSEN_SEG-\d+>>>\s*/,
  stripGlobalRe: /<<<SHINKANSEN_SEG-\d+>>>\s*/g,
  display: '<<<SHINKANSEN_SEG-N>>>',
};

const MAX_UNITS_PER_CHUNK = DEFAULT_UNITS_PER_BATCH;
const MAX_CHARS_PER_CHUNK = DEFAULT_CHARS_PER_BATCH;

/**
 * v1.8.20: 對 glossary / forbiddenTerms 的 source / target / forbidden / replacement 做消毒,
 * 移除可能污染 system instruction 的協定 token——auto glossary 從頁面內容抽,惡意頁面可在
 * 抽出來的詞裡塞 `<<<SHINKANSEN_SEP>>>` / `</forbidden_terms_blacklist>` / 反斜線換行
 * 影響後續批次切分或標記閉合;固定術語表使用者輸入也比照處理(防失誤)。
 *
 * 策略:單行化 + 移除佔位符與 sentinel token + 移除控制字元。
 */
function sanitizeTermText(s) {
  return String(s ?? '')
    // 控制字元 + 換行符 → 空白(避免欺騙 LLM 換行成額外規則)
    .replace(/[\x00-\x1f\x7f]+/g, ' ')
    // 配對 / 自閉合佔位符 token(防止使用者輸入誤觸發佔位符規則)
    .replace(/⟦\/?\*?\d+⟧/g, '')
    // 多段 sentinel(防止假冒批次切分標記)
    .replace(/<<<SHINKANSEN_SEP>>>/gi, '')
    // 多段序號標記兩種格式都 strip(防止假冒段序號;«\d+» 只匹配數字所以法文 / 德文
    // 引號 «bonjour» 不會誤傷)
    .replace(/<<<SHINKANSEN_SEG-\d+>>>/gi, '')
    .replace(/«\d+»/g, '')
    // forbidden_terms_blacklist 標籤(防止使用者輸入提前關閉區塊)
    .replace(/<\/?forbidden_terms_blacklist>/gi, '')
    .trim()
    .slice(0, 200); // 單詞超過 200 字本來就不正常,截斷防 prompt 暴脹
}

/**
 * Greedy 打包：對 texts 陣列用字元預算 + 段數上限雙門檻切成連續子批次，
 * 回傳「起始 / 結束 index」陣列讓呼叫端可以對齊結果。
 *
 * 批次 5-3（v1.10.46）：上限改可由 opts 帶入（呼叫端傳 settings.maxUnitsPerBatch /
 * maxCharsPerBatch）——原本寫死預設值，使用者在 options 調高 maxUnitsPerBatch 後
 * content 端分批生效但 adapter 端在這裡重切蓋掉（>20 段的設定無效且無提示）。
 * opts 缺漏或非法值 fallback 預設，既有呼叫端不傳 opts 行為不變。
 */
export function packChunks(texts, opts = {}) {
  const maxUnits = (Number.isFinite(opts.maxUnits) && opts.maxUnits >= 1)
    ? Math.floor(opts.maxUnits) : MAX_UNITS_PER_CHUNK;
  const maxChars = (Number.isFinite(opts.maxChars) && opts.maxChars >= 1)
    ? Math.floor(opts.maxChars) : MAX_CHARS_PER_CHUNK;
  const batches = [];
  let cur = null;
  const flush = () => { if (cur && cur.end > cur.start) batches.push(cur); cur = null; };
  for (let i = 0; i < texts.length; i++) {
    const len = (texts[i] || '').length;
    if (len > maxChars) {
      flush();
      batches.push({ start: i, end: i + 1 });
      continue;
    }
    if (cur && (cur.chars + len > maxChars || (cur.end - cur.start) >= maxUnits)) {
      flush();
    }
    if (!cur) cur = { start: i, end: i, chars: 0 };
    cur.end = i + 1;
    cur.chars += len;
  }
  flush();
  return batches;
}

/**
 * 組合最終的 system instruction。
 *
 * 順序(v1.8.39 起):
 *   baseSystem → 段內換行規則 → 佔位符規則 → fixedGlossary → forbiddenTerms
 *   → 自動 glossary → 多段分隔符規則(本批次包含 N 段)
 *
 * 設計理由:Gemini implicit cache 命中率優化。
 *   - prefix 越穩定的部分越靠前(baseSystem / fixedGlossary / forbiddenTerms 是使用者級固定,跨頁亦共享)
 *   - 條件性出現但「同頁穩定」的(段內換行 / 佔位符)放在前段,實務上整頁批次幾乎都會同 trigger
 *   - 頁面級變動的 glossary 放在 batch 級變動的「本批次包含 N 段」之前
 *   - batch 級變動的「本批次包含 N 段」(嵌入 literal 數字 N)推到最末端,
 *     讓所有 batch 共享前段 prefix
 *
 * 歷史排序(v0.71-v1.8.38):
 *   baseSystem → 多段分隔符 → 段內換行 → 佔位符 → glossary → fixedGlossary → forbiddenTerms
 *   舊排法把「本批次包含 N 段」放第 2 位,N 一變(例如最後一批 segs<20)導致
 *   後面所有 token 都 cache miss,實測 Medium 長文 hit rate 只能達 ~49%;
 *   新排法預估可拉到 ~80-90%。
 *
 * Trade-off:forbiddenTerms 不再「最末端最高權重」。
 *   v0.71 的 v0.70 bug 教訓:「術語表夾在中間會稀釋 LLM 對佔位符規則的注意力,
 *   導致 ⟦*N⟧ 標記洩漏」。新排法把 forbiddenTerms 從末端往前移,理論上 LLM
 *   注意力略降。靠 forbidden-terms-leak-detect / multi-segment 等 regression
 *   spec + 真實頁面驗證監測。
 *
 * @param {string} baseSystem 使用者設定的基礎 system instruction(每個 provider 可能不同)
 * @param {string[]} texts 本批原文陣列
 * @param {string} joined 已用 DELIMITER join 過的完整文字
 * @param {Array<{source:string, target:string}>} [glossary] 可選的自動擷取術語對照表
 * @param {Array<{source:string, target:string}>} [fixedGlossary] 可選的使用者固定術語表
 * @param {Array<{forbidden:string, replacement:string}>} [forbiddenTerms] 中國用語黑名單
 * @param {{display:string}} [marker] 多段序號標記配置,影響「本批次包含 N 段」描述句裡顯示
 *   的 N 範本。預設用 MARKER_COMPACT(«N»),OpenAI-compat 路徑可傳 MARKER_STRONG。
 *   Gemini 路徑固定 COMPACT,呼叫端不必傳。
 * @returns {string} 完整的 effectiveSystem
 */
export function buildEffectiveSystemInstruction(baseSystem, texts, joined, glossary, fixedGlossary, forbiddenTerms, marker = MARKER_COMPACT) {
  const parts = [baseSystem];

  // 段內換行保留規則
  if (texts.some(t => t && t.indexOf('\n') !== -1)) {
    parts.push(
      '額外規則（段落分隔）:\n輸入中可能含有段內換行符 \\n（例如 "第一段\\n\\n第二段"）,代表原文有對應的段落或行分隔（通常是 <br> 或 <br><br>）。翻譯時必須在對應位置原樣保留 \\n 字元——譯文段落數與輸入段落數一致,連續兩個 \\n 也要保留兩個。不可把段落合併成一行,也不可把空白行多塞或少塞。'
    );
  }

  // 佔位符保留規則
  if (joined.indexOf('⟦') !== -1) {
    parts.push(
      '額外規則（極重要，處理佔位符標記）:\n輸入中可能含有兩種佔位符標記，都是用來保留原文結構，必須原樣保留、不可翻譯、不可省略、不可改寫、不可新增、不可重排。佔位符裡的數字、斜線、星號 **必須是半形 ASCII 字元**（0-9、/、*），絕對不可改成全形（０-９、／、＊），否則程式無法配對會整段崩壞。\n\n（A）配對型 ⟦數字⟧…⟦/數字⟧（例如 ⟦0⟧Tokugawa Ieyasu⟦/0⟧)：\n- 把標記視為透明外殼。外殼「內部」的文字跟外殼「外部」的文字一樣，全部都要翻譯成繁體中文。\n- ⟦數字⟧ 與 ⟦/數字⟧ 兩個標記本身原樣保留，數字不變。\n- **配對型可以巢狀嵌套**（例如 ⟦0⟧may incorporate text from a ⟦1⟧large language model⟦/1⟧, which is ...⟦/0⟧）。巢狀代表原文是 `<b>text <a>link</a> more text</b>` 這類嵌套結構。翻譯時必須**同時**保留外層與內層兩組標記、不可扁平化成單層、不可交換順序、不可遺漏任何一層。外層與內層的內部文字全部要翻成繁體中文。\n\n（B）自閉合 ⟦*數字⟧（例如 ⟦*5⟧)：\n- 這是「原子保留」位置記號，代表原文裡有一段不可翻譯的小區塊（例如維基百科腳註參照 [2])。\n- 整個 ⟦*數字⟧ token 原樣保留，不可拆開、不可翻譯、不可省略，數字不變。\n- 它的位置代表那段內容應該插在譯文的哪裡。\n\n具體範例 1（單層）：\n輸入： ⟦0⟧Tokugawa Ieyasu⟦/0⟧ won the ⟦1⟧Battle of Sekigahara⟦/1⟧ in 1600.⟦*2⟧\n正確輸出： ⟦0⟧德川家康⟦/0⟧於 1600 年贏得⟦1⟧關原之戰⟦/1⟧。⟦*2⟧\n錯誤輸出 1： ⟦0⟧Tokugawa Ieyasu⟦/0⟧於 1600 年贏得⟦1⟧Battle of Sekigahara⟦/1⟧。⟦*2⟧（配對型內部英文沒翻）\n錯誤輸出 2： ⟦0⟧德川家康⟦/0⟧於 1600 年贏得⟦1⟧關原之戰⟦/1⟧。[2]（自閉合 ⟦*2⟧ 被擅自還原成 [2])\n\n具體範例 2（巢狀）：\n輸入： This article ⟦0⟧may incorporate text from a ⟦1⟧large language model⟦/1⟧, which is ⟦2⟧prohibited in Wikipedia articles⟦/2⟧⟦/0⟧.\n正確輸出： 本條目⟦0⟧可能包含來自⟦1⟧大型語言模型⟦/1⟧的文字，這在⟦2⟧維基百科條目中是被禁止的⟦/2⟧⟦/0⟧。\n錯誤輸出 3： 本條目可能包含來自⟦1⟧大型語言模型⟦/1⟧的文字，這在⟦2⟧維基百科條目中是被禁止的⟦/2⟧。（外層 ⟦0⟧…⟦/0⟧ 被扁平化丟掉）'
    );
  }

  // v1.0.29: 使用者固定術語表(使用者級固定,跨頁亦共享,放前段協助 cache 命中)
  // v1.8.20: 對 source / target 消毒,防止頁面內容塞 sentinel token 影響協定
  if (fixedGlossary && fixedGlossary.length > 0) {
    const lines = fixedGlossary
      .map(e => `${sanitizeTermText(e.source)} → ${sanitizeTermText(e.target)}`)
      .filter(l => !/^\s*→\s*$/.test(l))
      .join('\n');
    if (lines) {
      parts.push(
        '以下是使用者指定的固定術語表，優先級高於下方所有術語對照。遇到這些原文一律使用指定譯名，不可自行改寫，也不需加註英文原文：\n' + lines
      );
    }
  }

  // v1.5.6: 中國用語黑名單(使用者級固定,跨頁亦共享,放前段協助 cache 命中)。
  // 用 <forbidden_terms_blacklist> XML tag 包起來,跟 DEFAULT_SYSTEM_PROMPT 第 2 條
  // 的「依本 prompt 末端 <forbidden_terms_blacklist> 區塊」reference 對應。
  // v1.8.39 起從末端前移到 fixedGlossary 之後——失去「最末端最高權重」位置,
  // 靠 regression spec(forbidden-terms-leak-detect 系列)監測 LLM 服從度退化。
  if (forbiddenTerms && forbiddenTerms.length > 0) {
    // 拆兩類：有填替換詞的走「禁用 → 必須改用」對照；只填禁用詞、替換詞留空的
    // 列入「禁用（未指定替換詞）」區，請 LLM 自行改寫成自然的台灣慣用說法
    // （使用者單純不想看到某詞、但提不出固定替換詞的情境，例如陳腔濫調）。
    const mappedLines = [];
    const bannedOnly = [];
    for (const t of forbiddenTerms) {
      if (!t) continue;
      const forbidden = sanitizeTermText(t.forbidden);
      if (!forbidden || !forbidden.trim()) continue;
      const replacement = sanitizeTermText(t.replacement);
      if (replacement && replacement.trim()) {
        mappedLines.push(`${forbidden} → ${replacement}`);
      } else {
        bannedOnly.push(forbidden);
      }
    }
    if (mappedLines.length > 0 || bannedOnly.length > 0) {
      let block = '<forbidden_terms_blacklist>\n極重要：以下是嚴格禁用的詞彙，譯文中絕對不可使用，違反此規則即為錯誤翻譯。\n';
      if (mappedLines.length > 0) {
        block += '\n【禁用 → 必須改用】以下左欄詞彙一律改用右欄的台灣慣用語。即使原文是英文（例如 video / software / data），譯文也只能使用右欄。\n' + mappedLines.join('\n') + '\n';
      }
      if (bannedOnly.length > 0) {
        block += '\n【禁用（未指定替換詞）】以下詞彙同樣不可出現在譯文中，但未指定替換詞，請自行改用合適、自然的台灣慣用說法表達相同語意。\n' + bannedOnly.join('\n') + '\n';
      }
      block += '\n說明：本黑名單為硬性規定，優先級高於任何 stylistic 考量。若該詞為文章本身討論的主題（例如一篇分析「中國科技用語演變」的文章），請使用引號標示後保留原詞，例如「視頻」。\n</forbidden_terms_blacklist>';
      parts.push(block);
    }
  }

  // 自動擷取術語對照表(頁面級,跨頁變;放在使用者級規則之後讓跨頁 cache 共享前段)
  // v1.8.20: 對 source / target 消毒,防止頁面內容塞 sentinel token 影響協定
  if (glossary && glossary.length > 0) {
    const lines = glossary
      .map(e => `${sanitizeTermText(e.source)} → ${sanitizeTermText(e.target)}`)
      .filter(l => !/^\s*→\s*$/.test(l))
      .join('\n');
    if (lines) {
      parts.push(
        '以下是本篇文章的術語對照表，遇到這些原文一律使用指定譯名，不可自行改寫，也不需加註英文原文：\n' + lines
      );
    }
  }

  // 多段翻譯分隔符與序號規則(嵌入 batch 段數 N,batch 級變動;放最末端讓前段 cache 共享)
  if (texts.length > 1) {
    const m = marker.display;
    parts.push(
      `額外規則（多段翻譯分隔符與序號，極重要）:\n本批次包含 ${texts.length} 段文字。每段開頭有序號標記 ${m}（N 為 1 到 ${texts.length}），段與段之間以分隔符 <<<SHINKANSEN_SEP>>> 隔開。\n你的輸出必須：\n- 每段譯文開頭也加上對應的序號標記 ${m}（N 與輸入的序號一一對應）\n- 段與段之間用完全相同的分隔符 <<<SHINKANSEN_SEP>>> 隔開\n- 恰好輸出 ${texts.length} 段譯文和 ${texts.length - 1} 個分隔符\n- 不可合併段落、不可省略分隔符、不可增減段數`
    );
  }

  return parts.join('\n\n');
}
