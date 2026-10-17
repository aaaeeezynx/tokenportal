//! 通用小工具：連線、模型名正規化、來源判定、標頭處理、路徑處理。
//!
//! 這裡放的是「不屬於任何單一階段、但多個階段都要用」的純函式。

use super::*;

/// C 方案：啟動前先試綁，衝突時給出可操作的錯誤（常見佔用者：cc-switch 代理）。
pub(crate) fn check_port(port: u16) -> Result<(), String> {
    if port == 0 {
        return Err("連接埠不能為 0".to_string());
    }
    match std::net::TcpListener::bind(("127.0.0.1", port)) {
        Ok(_) => Ok(()),
        Err(e) if e.kind() == std::io::ErrorKind::AddrInUse => Err(format!(
            "連接埠 {port} 已被佔用（本機可能有 cc-switch 或其他代理在執行）：請在設定中更換連接埠，或停用對方後再啟動"
        )),
        Err(e) => Err(format!("連接埠 {port} 不可用：{e}")),
    }
}
/// 開一條短命連線（給「觀測／記憶」這類不能借用主連線的場景用）。
///
/// 收 `&Path` 而不是 `&PathBuf`：呼叫端手上常常只有路徑的一部分
/// （`Path::new(s)`、`dir.path().join(..)`），寬一點才不必到處 `to_path_buf()`。
pub(super) fn open_conn(db_path: &std::path::Path) -> Result<rusqlite::Connection, String> {
    let conn = rusqlite::Connection::open(db_path).map_err(|e| e.to_string())?;
    conn.execute_batch("PRAGMA busy_timeout=5000;")
        .map_err(|e| e.to_string())?;
    Ok(conn)
}

// ---------------------------------------------------------------- 用量 ---
// 用量結構與 OpenAI 讀取邏輯統一放在 translate（翻譯與代理共用）。

/// 模型名歸一化（與 M2 定價文檔一致）：小寫、去 `/` 前綴、去 `:` 後綴與 `[1m]` 尾綴，
/// 再剝最多 3 段版本/日期/渠道尾綴（如 `-ga-260731`、`-2024-07-18`、`-fk-hs`），
/// 使 `deepseek-v4-flash-ga-260731` 對上定價 `deepseek-v4-flash`。
/// 保守策略：只剝完整日期（YYYY-MM-DD / YYYYMMDD / YYMMDD）、vN 版本、`ga`、
/// `fk-*` 渠道標籤；`kimi-k2-0905` 的 MMDD、`gpt-5`、`llama-3` 一律保留。
pub(crate) fn normalize_model(raw: &str) -> String {
    let mut s = raw.trim().to_lowercase();
    if let Some(i) = s.rfind('/') {
        s = s[i + 1..].to_string();
    }
    if let Some(i) = s.find(':') {
        s.truncate(i);
    }
    if let Some(i) = s.find('[') {
        s.truncate(i);
    }
    s = s.replace('@', "-");
    // 整段日期尾綴（-YYYY-MM-DD / -YYYYMMDD / -YYMMDD），ASCII 安全切片
    pub(super) fn cut_full_date(s: &mut String) -> bool {
        let b = s.as_bytes();
        let n = s.len();
        let dig = |mut r: std::ops::Range<usize>| r.all(|i| b.get(i).is_some_and(|c| c.is_ascii_digit()));
        if n > 11 && b[n - 11] == b'-' && dig(n - 10..n - 6) && b[n - 6] == b'-'
            && dig(n - 5..n - 3) && b[n - 3] == b'-' && dig(n - 2..n)
        {
            s.truncate(n - 11);
            return true;
        }
        if n > 9 && b[n - 9] == b'-' && dig(n - 8..n) {
            s.truncate(n - 9);
            return true;
        }
        if n > 7 && b[n - 7] == b'-' && dig(n - 6..n) {
            s.truncate(n - 7);
            return true;
        }
        false
    }
    for _ in 0..3 {
        if cut_full_date(&mut s) {
            continue;
        }
        let Some(i) = s.rfind('-') else {
            break;
        };
        if i == 0 {
            break;
        }
        let tail = &s[i + 1..];
        let strip = tail.eq_ignore_ascii_case("ga")
            || (tail.starts_with("fk-") && tail.len() > 3)
            || (tail.starts_with('v')
                && tail.len() > 1
                && tail[1..].bytes().all(|b| b.is_ascii_digit() || b == b'.')
                && tail[1..].bytes().any(|b| b.is_ascii_digit()));
        if strip {
            s.truncate(i);
        } else {
            break;
        }
    }
    s
}
/// 從 UA 推斷來源應用程式；允許客戶端用 `X-TG-App` 顯式聲明（取值為 app id）。
///
/// # 為什麼要比對「最具體」的字串，而不是照固定順序找第一個命中
///
/// 原本的寫法是按固定順序（codex, opencode, hermes, dsh, deepseek…）找第一個
/// `contains`。那在單一命中的 UA 上沒問題，但只要 UA 同時出現兩個關鍵字就會
/// 歸錯邊 —— 而且是**靜默歸錯**，因為任何命中都會回傳一個合法 app 名稱。
///
/// 真實案例：DSH 的 `dsh-llm` 套件會用 `attributionHeaders()` 送出
/// `deepseek-harness/<ver> (+https://github.com/deepseek-ai/deepseek-harness)`。
/// 這個字串本身命中 `deepseek`（正確）。但只要客戶端在 UA 後面再接任何含
/// `codex`／`opencode` 的字（例如 profile 名稱、相容性標註），舊寫法就會先
/// 命中 `codex`，把 DSH 的用量記成 Codex 的用量 —— 兩者都回傳合法名稱，
/// 所以錯誤不會有任何跡象。
///
/// 修法：分兩層比對 —— 先看「產品自報名」（DSH 家族、opencode…），再看
/// 「相容性字樣」（`codex`，最容易被別人順帶提到，所以最後比）。
///
/// 我曾經用「字串長度＝具體度」來排序，那是錯的：裸的 `dsh`（3 字元）會被排到
/// `codex`（5 字元）後面。優先序必須明講，不能靠長度巧合。
pub(crate) fn infer_app(headers: &HeaderMap) -> String {
    if let Some(v) = headers
        .get("x-tg-app")
        .and_then(|v| v.to_str().ok())
        .map(str::trim)
    {
        if APPS.iter().any(|(a, _)| *a == v) {
            return v.to_string();
        }
    }
    let ua = headers
        .get("user-agent")
        .and_then(|v| v.to_str().ok())
        .unwrap_or("")
        .to_lowercase();

    // 比對分兩層，**不是**靠字串長度排序。
    //
    // 我一開始用「長度＝具體度」來排序，但那是錯的：裸的 `dsh` 只有 3 個字元，
    // 會被排到 `codex`（5 個字元）之後，於是 `codex_cli_rs/1.0 (dsh)` 又會落回
    // codex。長度只是巧合地適用於 `deepseek-harness` vs `codex`，不是可靠的通則。
    //
    // 正確的做法是明講優先序：
    //
    //   第 1 層（產品自報名）：DSH 家族與其他工具自己講出來的產品名。
    //     這些字串出現就代表「我就是這個工具」，優先權最高。
    //   第 2 層（相容性字樣）：`codex`。很多非 Codex 的客戶端會在自己的 UA
    //     裡附加 codex 以示相容，所以它最容易被順帶命中，必須最後才比。
    const SPECIFIC: [(&str, &str); 7] = [
        ("deepseek-harness", "dsh"), // DSH 的完整產品名
        ("deepseek", "dsh"),         // DSH 的產品線名
        ("dsh", "dsh"),              // 客戶端可能只用短名自稱
        ("opencode", "opencode"),
        ("hermes", "hermes"),
        ("antigravity", "antigravity"),
        ("cursor", "cursor"),
    ];
    const GENERIC: [(&str, &str); 3] = [
        ("codex", "codex"), // 最容易被別人順帶提到 → 最後比
        ("claude", "claude"),
        ("anthropic", "claude"),
    ];
    for (pat, app) in SPECIFIC.iter().chain(GENERIC.iter()) {
        if ua.contains(pat) {
            return app.to_string();
        }
    }
    "unknown".into()
}
/// 從入站請求取出本地金鑰。依序嘗試（覆蓋各家 SDK 的慣例）：
///
/// 1. `Authorization: Bearer`（OpenAI / Codex / dsh）
/// 2. `x-api-key`（Claude Code / Anthropic SDK）
/// 3. `x-goog-api-key`（**Gemini SDK**，2026-10-11 補）
/// 4. `?key=` 查詢參數（Google 官方 curl 範例的寫法，2026-10-11 補）
///
/// 3 與 4 是**原生 Gemini 客戶端唯一會用的方式** —— 它不會送 Bearer。
/// 少了它們，Gemini 進站請求連閘道都進不來（一律 401），
/// `(Gemini, Gemini)` 那一格等於形同虛設。
///
/// 查詢裡的 key 在轉發前會被 [`strip_key_param`] 拿掉、`x-goog-api-key` 也在
/// [`is_hop_header`] 的跳過清單裡，所以**不會外洩給上游**。
pub(super) fn bearer(headers: &HeaderMap, query: Option<&str>) -> Option<String> {
    // 優先 Authorization: Bearer（OpenAI / Codex / dsh）
    if let Some(v) = headers.get("authorization") {
        if let Ok(s) = v.to_str() {
            if let Some(k) = s
                .strip_prefix("Bearer ")
                .or_else(|| s.strip_prefix("bearer "))
            {
                return Some(k.trim().to_string());
            }
        }
    }
    // 備選：x-api-key（Claude Code / Anthropic SDK）、x-goog-api-key（Gemini SDK）
    for name in ["x-api-key", "x-goog-api-key"] {
        if let Some(v) = headers.get(name) {
            if let Ok(s) = v.to_str() {
                let k = s.trim();
                if !k.is_empty() {
                    return Some(k.to_string());
                }
            }
        }
    }
    // 最後：?key=（Google 官方範例的寫法）
    if let Some(q) = query {
        for kv in q.split('&') {
            if let Some((k, v)) = kv.split_once('=') {
                if k.eq_ignore_ascii_case("key") {
                    let v = v.trim();
                    if !v.is_empty() {
                        return Some(v.to_string());
                    }
                }
            }
        }
    }
    None
}
/// 拼接上游 URL：provider 基址已帶 `/v1` 時，去掉入站路徑重複的首段。
pub(super) fn join_upstream(base: &str, incoming_path: &str) -> String {
    let base = base.trim_end_matches('/');
    let base_last = base.rsplit('/').next().unwrap_or("");
    let mut segs: Vec<&str> = incoming_path.split('/').filter(|s| !s.is_empty()).collect();
    if !segs.is_empty() && segs[0].eq_ignore_ascii_case(base_last) && !base_last.is_empty() {
        segs.remove(0);
    }
    if segs.is_empty() {
        base.to_string()
    } else {
        format!("{base}/{}", segs.join("/"))
    }
}
pub(super) fn is_hop_header(name: &str) -> bool {
    matches!(
        name,
        "host" | "connection" | "transfer-encoding" | "content-length"
            | "accept-encoding" | "authorization" | "x-goog-api-key"
            | "x-api-key" | "anthropic-version" | "proxy-authenticate"
            | "proxy-authorization" | "te" | "trailer" | "upgrade"
    )
}
/// 404／405：這個路徑在該上游**不存在**。
///
/// 換協議換手時最容易踩到：provider 宣告的是 chat 渠道，卻被換到
/// `openai-responses` 去打 `/responses`，而上游根本沒這個端點，回一句
/// go 風格的 `404 page not found`。
///
/// 這種回應**不代表**那個協議「會通」，所以兩件事都不能做：
/// 不能拿去學習（見 `proxy.rs` 的 `learn_format` 守衛），也不能當成這條
/// 候選的成功結果。2026-10-07 的實例：NIM 的 `moonshotai/kimi-k3` 與
/// `z-ai/glm-5.3` 因為這條路徑被永久 404。
pub(super) fn is_missing_endpoint(status: StatusCode) -> bool {
    matches!(
        status,
        StatusCode::NOT_FOUND | StatusCode::METHOD_NOT_ALLOWED
    )
}
/// 是否注入 `stream_options` 索取用量。
///
/// **只有送出去的 body 是 OpenAI chat 形狀時才需要**：Responses／Anthropic／
/// Gemini 端點收到這個欄位會被上游 400。
///
/// 2026-10-10：舊版只看「有沒有翻譯」（`translated`）—— 那在只有「翻成 chat」
/// 的年代剛好等價，但新增「翻成 Anthropic」之後就不成立了。真機驗證立刻被
/// 上游擋下：`[invalid_request_error] stream_options: Extra inputs are not permitted`。
pub(super) fn should_inject_usage(kind: TransKind, incoming_path: &str) -> bool {
    match kind {
        TransKind::ResponsesToChat | TransKind::AnthropicToChat => true,
        TransKind::ChatToAnthropic | TransKind::ResponsesToAnthropic => false,
        // 直通：看客戶端打的是哪個端點
        TransKind::None => incoming_path.contains("/chat/completions"),
    }
}
/// 去掉 query 中的 `key` 參數（Google 式鑑權殘留，避免客戶端 key 上送）。
pub(super) fn strip_key_param(query: Option<&str>) -> Option<String> {
    let q = query?;
    let kept: Vec<&str> = q
        .split('&')
        .filter(|kv| {
            let k = kv.split('=').next().unwrap_or("");
            !k.eq_ignore_ascii_case("key")
        })
        .collect();
    if kept.is_empty() {
        None
    } else {
        Some(kept.join("&"))
    }
}
/// Gemini 原生把模型寫在 URL（`/v1beta/models/<id>:generateContent`），
/// 請求體無 model 欄位時從路徑回填，否則日誌與白名單無模型可用。
pub(super) fn model_from_path(path: &str) -> Option<String> {
    let last = path.rsplit('/').next()?;
    let (id, _) = last.split_once(':')?;
    if id.is_empty() {
        None
    } else {
        Some(id.to_string())
    }
}
