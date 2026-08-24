//! PipelineContext - 流水线执行上下文
//!
//! 从 pipeline.rs 拆分，管理单次请求的完整状态

use std::collections::{HashMap, VecDeque};
use std::sync::{Arc, Mutex, OnceLock};
use std::time::Instant;

use serde_json::{json, Value};
use tokio_util::sync::CancellationToken;
use uuid::Uuid;

use crate::models::ChatMessage as LegacyChatMessage;

use super::pipeline::ChatV2LLMAdapter;
use super::resource_types::{ContentBlock, ContextRef, ContextSnapshot, SendContextRef};
use super::types::{
    block_status, block_types, AttachmentInput, CanonicalContentPart, MessageBlock, MessageSources,
    ModelExecutionSnapshot, SendMessageRequest, SendOptions, TokenUsage, ToolResultInfo,
};
use super::vfs_resolver::escape_xml_content;

// ============================================================
// 🆕 2026-07 Doom loop 检测（借鉴 参考实现）
// ============================================================

/// 同一指纹连续出现第 3 次起拦截执行（合成失败结果回喂 LLM）
pub(crate) const DOOM_LOOP_WARN_THRESHOLD: u32 = 3;

/// 同一指纹连续出现第 5 次时终止本轮工具循环（生成 tool_limit 块）
pub(crate) const DOOM_LOOP_ABORT_THRESHOLD: u32 = 5;

#[derive(Debug, Clone, Copy, PartialEq, Eq)]
pub(crate) struct LocalShellRuntimeContract {
    pub(crate) os: &'static str,
    pub(crate) sandbox_backend: &'static str,
    pub(crate) shell_path: Option<&'static str>,
    pub(crate) shell_kind: &'static str,
    pub(crate) invocation: Option<&'static str>,
    pub(crate) output_encoding: Option<&'static str>,
    pub(crate) execution_supported: bool,
}

/// Return the local shell contract implemented by the desktop backend for a
/// target platform. Keep this mapping explicit so prompts and preflight output
/// cannot claim a PTY or a user-selected shell that the executor does not
/// provide.
pub(crate) fn local_shell_contract_for_platform(platform: &str) -> LocalShellRuntimeContract {
    match platform {
        "macos" => LocalShellRuntimeContract {
            os: "macOS",
            sandbox_backend: "macos_seatbelt",
            shell_path: Some("/bin/sh"),
            shell_kind: "posix_sh",
            invocation: Some("/bin/sh -c"),
            output_encoding: Some("utf-8"),
            execution_supported: true,
        },
        "windows" => LocalShellRuntimeContract {
            os: "Windows",
            sandbox_backend: "windows_appcontainer_job",
            shell_path: Some(r"System32\WindowsPowerShell\v1.0\powershell.exe"),
            shell_kind: "windows_powershell",
            invocation: Some(
                "powershell.exe -NoProfile -NonInteractive -ExecutionPolicy Bypass -EncodedCommand",
            ),
            output_encoding: Some("utf-8"),
            execution_supported: true,
        },
        // Linux 桌面：bubblewrap（bwrap）沙箱 + /bin/sh。契约层声明支持，
        // bwrap 是否实际安装由 preflight 的运行时 capability 探测兜底。
        // 注意：Android 上 std::env::consts::OS 为 "android"，不会命中本
        // 分支，移动端仍走下方 fail-closed 的 Unsupported 契约。
        "linux" => LocalShellRuntimeContract {
            os: "Linux",
            sandbox_backend: "linux_bwrap",
            shell_path: Some("/bin/sh"),
            shell_kind: "posix_sh",
            invocation: Some("/bin/sh -c"),
            output_encoding: Some("utf-8"),
            execution_supported: true,
        },
        _ => LocalShellRuntimeContract {
            os: "Unsupported",
            sandbox_backend: "unavailable",
            shell_path: None,
            shell_kind: "unavailable",
            invocation: None,
            output_encoding: Some("unknown"),
            execution_supported: false,
        },
    }
}

/// Doom loop 裁决结果
#[derive(Debug, Clone, Copy, PartialEq, Eq)]
pub(crate) enum DoomLoopVerdict {
    /// 正常执行
    Execute,
    /// 连续第 3/4 次相同调用：拦截执行，合成失败结果告知 LLM 改变策略
    SkipRepeated { count: u32 },
    /// 连续第 5 次相同调用：拦截执行并终止本轮工具循环
    Abort { count: u32 },
}

/// Doom loop 守卫：跨工具轮次追踪「工具名 + 参数 JSON」指纹的连续重复次数
///
/// 借鉴 参考实现 的 doom loop 检测（同工具同参数连续 3 次告警）。
/// 状态生命周期与 PipelineContext 一致（单次请求内跨递归轮次累计）；
/// 指纹不同（换工具或换参数）即重置计数。多变体路径在变体循环内各持有独立实例。
#[derive(Debug, Default)]
pub(crate) struct DoomLoopGuard {
    /// 最近一次观察到的调用指纹（sha256(工具名 + 参数 JSON)）
    last_fingerprint: Option<String>,
    /// 该指纹的连续出现次数（含当前次）
    repeat_count: u32,
    /// 是否已触发终止（达到 DOOM_LOOP_ABORT_THRESHOLD）
    abort_triggered: bool,
    /// 触发终止的工具名（用于 tool_limit 块提示文案）
    abort_tool_name: Option<String>,
}

impl DoomLoopGuard {
    /// 按执行顺序观察一次工具调用，返回裁决结果并更新内部计数
    ///
    /// 本方法只做计数与裁决，不落终止标记；由 tool_loop 对 Abort 裁决
    /// 调用 `mark_abort`（心跳白名单工具会忽略裁决，避免误伤合法轮询）。
    pub(crate) fn observe(
        &mut self,
        tool_name: &str,
        arguments: &serde_json::Value,
    ) -> DoomLoopVerdict {
        let fingerprint = Self::fingerprint(tool_name, arguments);
        if self.last_fingerprint.as_deref() == Some(fingerprint.as_str()) {
            self.repeat_count += 1;
        } else {
            self.last_fingerprint = Some(fingerprint);
            self.repeat_count = 1;
        }

        if self.repeat_count >= DOOM_LOOP_ABORT_THRESHOLD {
            DoomLoopVerdict::Abort {
                count: self.repeat_count,
            }
        } else if self.repeat_count >= DOOM_LOOP_WARN_THRESHOLD {
            DoomLoopVerdict::SkipRepeated {
                count: self.repeat_count,
            }
        } else {
            DoomLoopVerdict::Execute
        }
    }

    /// 落终止标记（tool_loop 对非心跳工具的 Abort 裁决调用）
    pub(crate) fn mark_abort(&mut self, tool_name: &str) {
        self.abort_triggered = true;
        self.abort_tool_name = Some(tool_name.to_string());
    }

    /// 是否已达到终止阈值（由 tool_loop 在工具批次执行后检查）
    pub(crate) fn abort_triggered(&self) -> bool {
        self.abort_triggered
    }

    /// 触发终止的工具名
    pub(crate) fn abort_tool_name(&self) -> Option<&str> {
        self.abort_tool_name.as_deref()
    }

    /// 计算调用指纹：sha256(工具名 + 0x1f + 参数 JSON 序列化)
    ///
    /// serde_json 启用 preserve_order，同一 LLM 重复输出的相同参数
    /// 序列化结果稳定，指纹可靠。
    fn fingerprint(tool_name: &str, arguments: &serde_json::Value) -> String {
        use sha2::{Digest, Sha256};
        let mut hasher = Sha256::new();
        hasher.update(tool_name.as_bytes());
        hasher.update(b"\x1f");
        hasher.update(
            serde_json::to_string(arguments)
                .unwrap_or_default()
                .as_bytes(),
        );
        format!("{:x}", hasher.finalize())
    }
}

// ============================================================
// 🆕 2026-07 Citation Ledger（P0：跨工具调用引用编号全局一致）
// ============================================================

/// 单次引用编号分配结果
#[derive(Debug, Clone, Copy, PartialEq, Eq)]
pub struct CitationAssignment {
    /// 同类来源内的编号（`[类型-N]` 中的 N）
    pub type_index: usize,
    /// 是否为本次回复内首次出现的来源
    pub is_new: bool,
}

/// 引用编号账本：同一次助手回复（一次 tool loop，可含多轮检索工具调用）内，
/// 同一 (引用类型, 来源身份) 恒定复用同一编号，新来源在该类型内全局递增。
///
/// ## 契约
/// - 前端「直接信任后端 citationTag/typeIndex，不再重排」，因此多轮工具调用后
///   `[知识库-3]` 必须永远指向同一来源——由本账本保证。
/// - `group` 为引用类型分组键（rag / multimodal / memory / web），
///   `identity` 为来源身份键（resource/chunk/page/blob 或 noteId / URL）。
/// - 单条检索结果内出现相同身份时也会得到相同编号（上游检索已做去重，
///   即便漏网也保持「同源同号」语义）。
#[derive(Debug, Default)]
pub struct CitationLedger {
    /// 引用类型 -> 已分配的最大编号
    counters: HashMap<String, usize>,
    /// "group\x1f identity" -> 已分配编号
    assignments: HashMap<String, usize>,
}

impl CitationLedger {
    pub fn new() -> Self {
        Self::default()
    }

    /// 为 (group, identity) 分配（或复用）同类编号
    pub fn assign(&mut self, group: &str, identity: &str) -> CitationAssignment {
        let key = format!("{}\u{1f}{}", group, identity);
        if let Some(&type_index) = self.assignments.get(&key) {
            return CitationAssignment {
                type_index,
                is_new: false,
            };
        }
        let counter = self.counters.entry(group.to_string()).or_insert(0);
        *counter += 1;
        let type_index = *counter;
        self.assignments.insert(key, type_index);
        CitationAssignment {
            type_index,
            is_new: true,
        }
    }

    /// 已分配的来源总数（跨类型）
    pub fn len(&self) -> usize {
        self.assignments.len()
    }

    pub fn is_empty(&self) -> bool {
        self.assignments.is_empty()
    }
}

/// 全局 Citation Ledger 注册表容量（按「回复」计，FIFO 淘汰最旧条目）。
///
/// 账本生命周期 = 一次助手回复（assistant_message_id + variant_id 唯一确定）。
/// 工具执行侧只能拿到 `ExecutionContext`（归其他代理所有，无法加字段），
/// 因此账本挂在这里的进程级注册表上，以 (session, message, variant) 为键；
/// 回复结束后条目不再被访问，由容量上限自然淘汰，无需显式清理钩子。
const CITATION_LEDGER_CAPACITY: usize = 64;

#[derive(Default)]
struct CitationLedgerRegistry {
    ledgers: HashMap<String, Arc<Mutex<CitationLedger>>>,
    /// 插入顺序（FIFO 淘汰用）
    order: VecDeque<String>,
}

static CITATION_LEDGERS: OnceLock<Mutex<CitationLedgerRegistry>> = OnceLock::new();

/// 获取（或创建）某次助手回复对应的引用编号账本。
///
/// - `message_id`：助手消息 ID（同一次 tool loop 的多轮工具调用共享）
/// - `variant_id`：多变体路径下各变体独立编号，避免跨变体串号
pub fn citation_ledger_for_reply(
    session_id: &str,
    message_id: &str,
    variant_id: Option<&str>,
) -> Arc<Mutex<CitationLedger>> {
    let key = format!(
        "{}\u{1f}{}\u{1f}{}",
        session_id,
        message_id,
        variant_id.unwrap_or("")
    );
    let registry = CITATION_LEDGERS.get_or_init(|| Mutex::new(CitationLedgerRegistry::default()));
    let mut registry = registry
        .lock()
        .unwrap_or_else(|poisoned| poisoned.into_inner());
    if let Some(ledger) = registry.ledgers.get(&key) {
        return Arc::clone(ledger);
    }
    let ledger = Arc::new(Mutex::new(CitationLedger::new()));
    registry.ledgers.insert(key.clone(), Arc::clone(&ledger));
    registry.order.push_back(key);
    while registry.order.len() > CITATION_LEDGER_CAPACITY {
        if let Some(evicted) = registry.order.pop_front() {
            registry.ledgers.remove(&evicted);
        }
    }
    ledger
}

// ============================================================
// 🆕 2026-07 检索工具输出的 LLM 视图脱敏（P1：本地路径/冗余字段不进上下文）
// ============================================================

/// 判断工具是否为「输出中带 sources 数组」的检索类工具
pub(crate) fn is_retrieval_source_tool(tool_name: &str) -> bool {
    let stripped = tool_name.strip_prefix("builtin-").unwrap_or(tool_name);
    matches!(
        stripped,
        "rag_search" | "multimodal_search" | "unified_search" | "web_search"
    )
}

/// 构建检索工具输出的 LLM 视图：
/// 保留给前端/持久化的 `output`（事件 payload 与块 tool_output）字段完整，
/// 回灌 LLM 的 tool 消息则剥离本地路径与纯诊断字段，节省 token 且符合
/// citationGuide「禁止输出 URL / Markdown 图片」的约束。
///
/// 剥离规则：
/// - 每条 source：移除 `imageUrl`/`imageCitation`（本地路径 + `![](...)` Markdown）、
///   `blob_hash`（内容哈希，仅前端渲染用）、`retrievalProvenance`（冗长诊断）；
///   `url` 仅在非 http(s)（即本地路径 / asset 协议）时移除。
/// - 顶层：移除 `retrievalPlan` / `capabilitySnapshot`（纯诊断，前端事件仍有全量）。
///
/// 返回 `None` 表示该工具/形状不适用脱敏（调用方使用原始 output）。
pub(crate) fn sanitize_retrieval_output_for_llm(tool_name: &str, output: &Value) -> Option<Value> {
    if !is_retrieval_source_tool(tool_name) {
        return None;
    }
    if !output.is_object() {
        return None;
    }
    let mut sanitized = output.clone();
    {
        let object = sanitized.as_object_mut()?;
        object.remove("retrievalPlan");
        object.remove("capabilitySnapshot");
        if let Some(sources) = object.get_mut("sources").and_then(Value::as_array_mut) {
            for source in sources {
                let Some(entry) = source.as_object_mut() else {
                    continue;
                };
                entry.remove("imageUrl");
                entry.remove("imageCitation");
                entry.remove("blob_hash");
                entry.remove("retrievalProvenance");
                let keep_url = entry
                    .get("url")
                    .and_then(Value::as_str)
                    .is_some_and(|url| url.starts_with("http://") || url.starts_with("https://"));
                if !keep_url {
                    entry.remove("url");
                }
            }
        }
    }
    Some(sanitized)
}

// ============================================================
// 内部上下文
// ============================================================

/// 流水线执行上下文
pub(crate) struct PipelineContext {
    /// 会话 ID
    pub(crate) session_id: String,
    /// 用户消息 ID
    pub(crate) user_message_id: String,
    /// 助手消息 ID
    pub(crate) assistant_message_id: String,
    /// 用户消息内容
    pub(crate) user_content: String,
    /// 本轮运行时事实（用于注入 <runtime_facts>）
    pub(crate) runtime_facts: String,
    /// 用户附件
    pub(crate) attachments: Vec<AttachmentInput>,
    /// 聊天历史（用于构建上下文）
    pub(crate) chat_history: Vec<LegacyChatMessage>,
    /// Capability-aware compiler output for the current user turn.
    pub(crate) compiled_current_user_message: Option<LegacyChatMessage>,
    /// Stable typed content persisted with the user message.
    pub(crate) canonical_content: Vec<CanonicalContentPart>,
    /// Frozen model/capability plan for this in-flight generation.
    pub(crate) execution_snapshot: Option<ModelExecutionSnapshot>,
    /// 检索到的来源
    pub(crate) retrieved_sources: MessageSources,
    /// 🆕 P1-10：本轮 turn-volatile 块（格式 hints / 画像 / 待办 / 检索 context /
    /// Canvas 笔记），由 prompt_builder 拆分产出，注入当前 user 消息的
    /// `<injected_context>` 而非 system——system 是 input 第 0 位，逐轮变化
    /// 会打碎全部历史 prompt cache。必须在 compile_frozen_context 之前赋值，
    /// 编译后随 compiled_current_user_message 冻结并经 V20260806 llm_content 落库。
    pub(crate) turn_volatile_context: Option<String>,
    /// 发送选项
    pub(crate) options: SendOptions,
    /// 工具调用结果
    pub(crate) tool_results: Vec<ToolResultInfo>,
    /// 最终生成的内容
    pub(crate) final_content: String,
    /// 最终生成的思维链
    pub(crate) final_reasoning: Option<String>,
    /// 活跃的块 ID 映射（event_type -> block_id）
    pub(crate) active_blocks: HashMap<String, String>,
    /// 生成的块列表（用于持久化）
    pub(crate) generated_blocks: Vec<MessageBlock>,
    /// 流式过程中创建的 thinking 块 ID
    pub(crate) streaming_thinking_block_id: Option<String>,
    /// 流式过程中创建的 content 块 ID
    pub(crate) streaming_content_block_id: Option<String>,
    /// 流式过程中创建的检索块 ID（block_type -> block_id）
    pub(crate) streaming_retrieval_block_ids: HashMap<String, String>,
    /// 🔧 P1修复：已添加到消息历史的工具结果数量（避免递归时重复添加）
    pub(crate) tool_results_added_count: usize,
    /// 开始时间
    pub(crate) start_time: Instant,
    /// Token 使用统计（累积多轮工具调用）
    pub(crate) token_usage: TokenUsage,

    // ========== Interleaved Thinking 支持（思维链+工具调用交替）==========
    /// 所有轮次产生的块 ID（按时序顺序，支持 thinking→tool→thinking→content 交替）
    /// 这是最终保存到消息的 block_ids 列表
    pub(crate) interleaved_block_ids: Vec<String>,
    /// 所有轮次产生的块内容（与 interleaved_block_ids 对应）
    pub(crate) interleaved_blocks: Vec<MessageBlock>,
    /// 全局块索引计数器（确保块按时序排序）
    pub(crate) global_block_index: u32,

    /// 待传递给 API 的 reasoning_content（DeepSeek/Claude 工具调用递归时使用）
    /// 在工具调用迭代中，需要将上一轮的 thinking_content 回传给 API
    pub(crate) pending_reasoning_for_api: Option<String>,

    /// 🔧 P1-2 修复：每轮工具调用的伴随文本（text-before-tool_use）
    /// 键为该轮第一个工具结果的 tool_call_id。用于在 tool_results_to_messages_impl
    /// 中回填 assistant(tool_call) 消息的 content，让 LLM 能看到上一轮说过的话
    pub(crate) round_text_by_tool_call_id: HashMap<String, String>,

    /// OpenAI Responses reasoning items keyed by the adjacent tool_call_id
    /// (each function_call carries its own reasoning item; never all bound to
    /// the first call of a batch). A tool-less final turn is stored under the
    /// sentinel key [`crate::chat_v2::types::RESPONSES_FINAL_REASONING_KEY`].
    /// Kept in memory and replayed on the next stateless request.
    pub(crate) response_reasoning_by_tool_call_id: HashMap<String, Value>,

    /// P2-13 收尾：本次运行收集到的服务端 `web_search_call` 完整 item
    /// （按 id 去重、后到覆盖）。随 assistant 消息 meta 持久化
    /// （键 `openai_responses_web_search_items`），history 重放时挂回出站
    /// assistant 消息 metadata，Responses 转换层原样回传 input。
    pub(crate) response_web_search_items: Vec<Value>,

    /// Gemini 3 思维签名缓存（工具调用迭代时回传）
    /// 在工具调用场景下，API 返回的 thoughtSignature 需要缓存并在后续请求中回传
    pub(crate) pending_thought_signature: Option<String>,

    /// 🔧 修复：当前 LLM 适配器引用（用于取消时获取已累积的内容）
    pub(crate) current_adapter: Option<std::sync::Arc<ChatV2LLMAdapter>>,

    // ========== 统一上下文注入系统支持 ==========
    /// 用户上下文引用（前端传递，包含 formattedBlocks）
    pub(crate) user_context_refs: Vec<SendContextRef>,
    /// 上下文快照（消息保存时使用，只存 ContextRef）
    pub(crate) context_snapshot: ContextSnapshot,

    /// 🔧 Bug修复：模型显示名称（如 "Qwen/Qwen3-8B"），用于消息保存
    /// 区别于 options.model_id（API 配置 ID），这个字段用于前端显示
    pub(crate) model_display_name: Option<String>,

    pub(crate) last_block_ended_at: Option<i64>,

    pub(crate) workspace_id: Option<String>,
    pub(crate) workspace_injection_count: u32,

    /// 🆕 取消令牌：用于工具执行取消机制
    /// 从 Pipeline.execute() 传递，允许工具执行器响应取消请求
    pub(crate) cancellation_token: Option<CancellationToken>,

    /// 🔒 安全修复：连续心跳次数追踪
    /// 防止工具通过持续返回 continue_execution 无限绕过递归限制
    pub(crate) heartbeat_count: u32,

    /// 🔧 F5 修复：最近一轮工具执行是否产生有效心跳
    /// 之前通过扫描 ctx.tool_results 全量历史判断心跳，一次 coordinator_sleep
    /// continue_execution=true 会让所有后续轮次都被视为有心跳；
    /// 现在只记录最近一轮的结果，由 tool_loop 在每轮工具执行后更新
    pub(crate) last_round_heartbeat: bool,

    /// 🆕 P1: 需要压缩标记。由 tool_loop 在 LLM 回复完成 / 工具结果累加后检查
    /// provider usage 决定是否设置；外层 pipeline 循环读取并在下一次
    /// LLM 调用前执行 compaction::run，完成后重置为 false。
    pub(crate) needs_compaction: bool,

    /// 🆕 2026-07: Doom loop 守卫 —— 跨工具轮次追踪「工具名+参数」指纹的连续重复，
    /// 连续第 3 次拦截执行回喂合成失败，连续第 5 次终止本轮循环（见 DoomLoopGuard）
    pub(crate) doom_loop_guard: DoomLoopGuard,

    /// 🆕 最近一次 load_chat_history 中 FIFO 截断的丢弃报告（dropped > 0 时挂起），
    /// 由 notify_context_trimmed 消费并发射 `context_trimmed` 事件
    pub(crate) pending_context_trim: Option<super::pipeline::TrimOutcome>,

    /// 🆕 本轮流式内是否已发射过 `context_trimmed`（去重防刷屏）
    pub(crate) context_trim_notified: bool,

    /// 🆕 DESIGN：FIFO 头删触发前强制 compaction 的每轮一次性闸门。
    /// load_chat_history 发现超预算时先跑 compaction；本标志保证同一轮
    /// send 至多强制一次，compaction 后仍超预算时直接 FIFO 兜底，不会
    /// 陷入「compaction → 重载 → 再 compaction」的循环。
    pub(crate) forced_compaction_before_trim: bool,
}

impl PipelineContext {
    pub(crate) fn new(request: SendMessageRequest) -> Self {
        // 如果前端传递了消息 ID，使用前端的；否则后端生成
        let user_message_id = request
            .user_message_id
            .clone()
            .unwrap_or_else(|| format!("msg_{}", Uuid::new_v4()));
        let assistant_message_id = request
            .assistant_message_id
            .clone()
            .unwrap_or_else(|| format!("msg_{}", Uuid::new_v4()));
        let runtime_facts = Self::build_runtime_facts_block(&request.content);

        Self {
            session_id: request.session_id,
            user_message_id,
            assistant_message_id,
            user_content: request.content,
            runtime_facts,
            // ★ 2025-12-10 统一改造：附件不再通过 request.attachments 传递
            // 所有附件现在通过 user_context_refs 传递
            attachments: Vec::new(),
            chat_history: Vec::new(),
            compiled_current_user_message: None,
            canonical_content: Vec::new(),
            execution_snapshot: None,
            retrieved_sources: MessageSources::default(),
            turn_volatile_context: None,
            options: request.options.unwrap_or_default(),
            tool_results: Vec::new(),
            final_content: String::new(),
            final_reasoning: None,
            active_blocks: HashMap::new(),
            generated_blocks: Vec::new(),
            streaming_thinking_block_id: None,
            streaming_content_block_id: None,
            streaming_retrieval_block_ids: HashMap::new(),
            tool_results_added_count: 0,
            start_time: Instant::now(),
            token_usage: TokenUsage::default(),
            // Interleaved Thinking 支持
            interleaved_block_ids: Vec::new(),
            interleaved_blocks: Vec::new(),
            global_block_index: 0,
            pending_reasoning_for_api: None,
            round_text_by_tool_call_id: HashMap::new(),
            response_reasoning_by_tool_call_id: HashMap::new(),
            response_web_search_items: Vec::new(),
            pending_thought_signature: None,
            current_adapter: None,
            // 统一上下文注入系统支持
            user_context_refs: request.user_context_refs.clone().unwrap_or_default(),
            // ★ 文档28 Prompt10：初始化 context_snapshot 时设置 path_map
            context_snapshot: {
                let mut snapshot = ContextSnapshot::new();
                if let Some(path_map) = request.path_map {
                    snapshot.path_map = path_map;
                }
                snapshot
            },
            model_display_name: None,
            last_block_ended_at: None,
            workspace_id: request.workspace_id.clone(),
            workspace_injection_count: 0,
            cancellation_token: None,
            heartbeat_count: 0,
            last_round_heartbeat: false,
            needs_compaction: false,
            doom_loop_guard: DoomLoopGuard::default(),
            pending_context_trim: None,
            context_trim_notified: false,
            forced_compaction_before_trim: false,
        }
    }

    /// 🆕 设置取消令牌
    pub(crate) fn set_cancellation_token(&mut self, token: CancellationToken) {
        self.cancellation_token = Some(token);
    }

    /// 🆕 获取取消令牌（如果有）
    pub(crate) fn cancellation_token(&self) -> Option<&CancellationToken> {
        self.cancellation_token.as_ref()
    }

    /// 获取经过的时间（毫秒）
    pub(crate) fn elapsed_ms(&self) -> u64 {
        self.start_time.elapsed().as_millis() as u64
    }

    /// 添加工具调用结果
    pub(crate) fn add_tool_results(&mut self, results: Vec<ToolResultInfo>) {
        self.tool_results.extend(results);
    }

    /// P2-13 收尾：合并本轮流式收集的服务端 web_search_call 完整 item
    /// （按 id 去重、后到覆盖，与 adapter 侧缓存语义一致）。
    pub(crate) fn merge_response_web_search_items(&mut self, items: Vec<Value>) {
        for item in items {
            let id = item.get("id").and_then(Value::as_str).map(str::to_string);
            let existing = id.as_deref().and_then(|id| {
                self.response_web_search_items
                    .iter_mut()
                    .find(|existing| existing.get("id").and_then(Value::as_str) == Some(id))
            });
            match existing {
                Some(existing) => *existing = item,
                None => self.response_web_search_items.push(item),
            }
        }
    }

    /// 将**所有**工具调用结果转换为 LLM 消息格式
    ///
    /// 🔧 P2修复：每次递归调用时，需要包含所有历史工具结果，而不是只有新的。
    /// 因为 messages 每次都从 ctx.chat_history.clone() 重新构建，之前添加的工具结果不会被保留。
    pub(crate) fn all_tool_results_to_messages(&self) -> Vec<LegacyChatMessage> {
        self.tool_results_to_messages_impl(&self.tool_results)
    }

    /// 将工具调用结果转换为 LLM 消息格式
    ///
    /// 按照 OpenAI/DeepSeek 工具调用协议，返回正确顺序的消息：
    /// 1. 一个 assistant 消息，包含 tool_calls（以及可选的 thinking_content 用于 DeepSeek reasoner）
    /// 2. 多个 tool 消息，对应每个工具调用的结果
    ///
    /// ## DeepSeek Thinking Mode 支持
    /// 根据 DeepSeek API 文档，在工具调用迭代中，需要将上一轮的 reasoning_content 回传给 API。
    /// 第一个 assistant 消息会包含 `thinking_content` 字段（对应 DeepSeek 的 `reasoning_content`）。
    ///
    /// 🔧 P1修复：只返回尚未添加到消息历史的工具结果，避免递归时重复添加
    /// 🔧 P2修复：此方法已废弃，请使用 all_tool_results_to_messages()
    #[allow(dead_code)]
    pub(crate) fn tool_results_to_messages(&self) -> Vec<LegacyChatMessage> {
        // 只处理尚未添加到消息历史的工具结果
        let new_results = &self.tool_results[self.tool_results_added_count..];
        if new_results.is_empty() {
            return Vec::new();
        }

        let mut messages = Vec::new();
        let mut is_first_assistant_msg = true;

        // 1. 首先生成 assistant 消息（包含所有 tool_calls）
        // 按照 OpenAI 规范，assistant 消息必须在 tool 消息之前
        for result in new_results {
            // 为每个工具调用生成一个带 tool_call 的 assistant 消息
            let tool_call = crate::models::ToolCall {
                id: result.tool_call_id.clone().unwrap_or_default(),
                tool_name: result.tool_name.clone(),
                args_json: result.input.clone(),
            };

            // 🔧 DeepSeek Thinking Mode：第一个 assistant 消息包含 reasoning_content
            // 根据 DeepSeek API 文档，在工具调用迭代中需要回传 reasoning_content
            let thinking_content = if is_first_assistant_msg {
                is_first_assistant_msg = false;
                self.pending_reasoning_for_api.clone()
            } else {
                None
            };
            let response_reasoning_item = result
                .tool_call_id
                .as_ref()
                .and_then(|id| self.response_reasoning_by_tool_call_id.get(id))
                .cloned();

            let assistant_msg = LegacyChatMessage {
                role: "assistant".to_string(),
                content: String::new(), // 工具调用时内容可为空
                timestamp: chrono::Utc::now(),
                thinking_content, // 🆕 回传 reasoning_content 给 DeepSeek API
                thought_signature: None,
                rag_sources: None,
                memory_sources: None,
                graph_sources: None,
                web_search_sources: None,
                image_paths: None,
                image_base64: None,
                doc_attachments: None,
                multimodal_content: None,
                tool_call: Some(tool_call),
                tool_result: None,
                overrides: None,
                relations: None,
                persistent_stable_id: None,
                metadata: response_reasoning_item
                    .map(|item| json!({ "openai_responses_reasoning_item": item })),
            };
            messages.push(assistant_msg);

            // 2. 紧跟对应的 tool 消息
            let tool_result = crate::models::ToolResult {
                call_id: result.tool_call_id.clone().unwrap_or_default(),
                ok: result.success,
                error: result.error.clone(),
                error_details: None,
                data_json: Some(result.output.clone()),
                usage: None,
                citations: None,
            };
            let tool_msg = LegacyChatMessage {
                role: "tool".to_string(),
                content: serde_json::to_string(&result.output).unwrap_or_default(),
                timestamp: chrono::Utc::now(),
                thinking_content: None,
                thought_signature: None,
                rag_sources: None,
                memory_sources: None,
                graph_sources: None,
                web_search_sources: None,
                image_paths: None,
                image_base64: None,
                doc_attachments: None,
                multimodal_content: None,
                tool_call: None,
                tool_result: Some(tool_result),
                overrides: None,
                relations: None,
                persistent_stable_id: None,
                metadata: None,
            };
            messages.push(tool_msg);
        }

        messages
    }

    /// 内部实现：将指定的工具结果转换为 LLM 消息格式
    fn tool_results_to_messages_impl(&self, results: &[ToolResultInfo]) -> Vec<LegacyChatMessage> {
        if results.is_empty() {
            return Vec::new();
        }

        let mut messages = Vec::new();

        for result in results {
            // 为每个工具调用生成一个带 tool_call 的 assistant 消息
            let tool_call = crate::models::ToolCall {
                id: result.tool_call_id.clone().unwrap_or_default(),
                tool_name: result.tool_name.clone(),
                args_json: result.input.clone(),
            };

            // 🔧 思维链修复：每个工具结果使用它自己的 reasoning_content
            // 这样多轮工具调用的思维链都能被正确保留和回传
            let thinking_content = result.reasoning_content.clone();
            let response_reasoning_item = result
                .tool_call_id
                .as_ref()
                .and_then(|id| self.response_reasoning_by_tool_call_id.get(id))
                .cloned();

            // 🔧 P1-2 修复：回填该轮的伴随文本（text-before-tool_use），
            // 使 LLM 在后续轮次能看到自己在发起工具调用前说过的话
            let round_text = result
                .tool_call_id
                .as_ref()
                .and_then(|id| self.round_text_by_tool_call_id.get(id))
                .cloned()
                .unwrap_or_default();

            let assistant_msg = LegacyChatMessage {
                role: "assistant".to_string(),
                content: round_text,
                timestamp: chrono::Utc::now(),
                thinking_content,
                thought_signature: result.thought_signature.clone(),
                rag_sources: None,
                memory_sources: None,
                graph_sources: None,
                web_search_sources: None,
                image_paths: None,
                image_base64: None,
                doc_attachments: None,
                multimodal_content: None,
                tool_call: Some(tool_call),
                tool_result: None,
                overrides: None,
                relations: None,
                persistent_stable_id: None,
                metadata: response_reasoning_item
                    .map(|item| json!({ "openai_responses_reasoning_item": item })),
            };
            messages.push(assistant_msg);

            // 紧跟对应的 tool 消息
            let tool_result = crate::models::ToolResult {
                call_id: result.tool_call_id.clone().unwrap_or_default(),
                ok: result.success,
                error: result.error.clone(),
                error_details: None,
                data_json: Some(result.output.clone()),
                usage: None,
                citations: None,
            };

            // 🔧 修复：当工具失败时，content 应包含错误信息而非空的 output
            // 这样 LLM 才能知道工具调用失败的原因并做出合理响应
            // 🆕 P1：检索工具的 LLM 视图脱敏——本地路径 / Markdown 图片 / 冗长诊断
            // 字段不回灌 LLM；前端事件 payload 与持久化块 tool_output 仍为全量。
            let tool_content = if result.success {
                match sanitize_retrieval_output_for_llm(&result.tool_name, &result.output) {
                    Some(sanitized) => serde_json::to_string(&sanitized).unwrap_or_default(),
                    None => serde_json::to_string(&result.output).unwrap_or_default(),
                }
            } else {
                // 失败时优先使用 error，若 error 为空则回退到 output
                if let Some(ref err) = result.error {
                    if !err.is_empty() {
                        format!("Error: {}", err)
                    } else {
                        serde_json::to_string(&result.output).unwrap_or_default()
                    }
                } else {
                    serde_json::to_string(&result.output).unwrap_or_default()
                }
            };

            let tool_msg = LegacyChatMessage {
                role: "tool".to_string(),
                content: tool_content,
                timestamp: chrono::Utc::now(),
                thinking_content: None,
                thought_signature: None,
                rag_sources: None,
                memory_sources: None,
                graph_sources: None,
                web_search_sources: None,
                image_paths: None,
                image_base64: None,
                doc_attachments: None,
                multimodal_content: None,
                tool_call: None,
                tool_result: Some(tool_result),
                overrides: None,
                relations: None,
                persistent_stable_id: None,
                metadata: None,
            };
            messages.push(tool_msg);
        }

        messages
    }

    // ========== Interleaved Thinking 辅助方法 ==========

    /// 添加一个块到交替块列表（按时序累积）
    ///
    /// 用于 thinking→tool→thinking→content 交替模式，确保块 ID 按生成顺序累积。
    ///
    /// ## 参数
    /// - `block`: 要添加的块
    ///
    /// ## 返回
    /// 块被分配的 block_index
    pub(crate) fn add_interleaved_block(&mut self, mut block: MessageBlock) -> u32 {
        // 🔧 幂等保护：同一块 ID 只收集一次。
        // attempt_completion 路径 / 取消收尾路径可能对同一轮的 thinking/content 块
        // 重复调用 collect_round_blocks，重复收集会导致 block_ids 列表出现重复项。
        if let Some(pos) = self
            .interleaved_blocks
            .iter()
            .position(|b| b.id == block.id)
        {
            return self.interleaved_blocks[pos].block_index;
        }
        let index = self.global_block_index;
        block.block_index = index;
        self.global_block_index += 1;
        self.interleaved_block_ids.push(block.id.clone());
        self.interleaved_blocks.push(block);
        index
    }

    /// 收集本轮 LLM 调用产生的 thinking 和 content 块
    ///
    /// 在递归调用 execute_with_tools 之前调用，将本轮产生的块添加到交替列表。
    ///
    /// ## 参数
    /// - `thinking_block_id`: thinking 块 ID（如果有）
    /// - `thinking_content`: thinking 内容（如果有）
    /// - `content_block_id`: content 块 ID（如果有）
    /// - `content_text`: content 内容（如果有）
    /// - `message_id`: 消息 ID
    pub(crate) fn collect_round_blocks(
        &mut self,
        thinking_block_id: Option<String>,
        thinking_content: Option<String>,
        content_block_id: Option<String>,
        content_text: Option<String>,
        message_id: &str,
    ) {
        let now_ms = chrono::Utc::now().timestamp_millis();
        let context_start_ms = now_ms - self.elapsed_ms() as i64;

        // 添加 thinking 块（如果有）
        if let (Some(block_id), Some(content)) = (thinking_block_id, thinking_content) {
            if !content.is_empty() {
                // 🔧 P3修复：使用上一个块的结束时间作为本块的开始时间
                // 第一个块使用 context 开始时间
                let started_at = self.last_block_ended_at.unwrap_or(context_start_ms);
                let block = MessageBlock {
                    id: block_id,
                    message_id: message_id.to_string(),
                    block_type: block_types::THINKING.to_string(),
                    status: block_status::SUCCESS.to_string(),
                    content: Some(content),
                    tool_name: None,
                    tool_input: None,
                    tool_output: None,
                    citations: None,
                    error: None,
                    started_at: Some(started_at),
                    ended_at: Some(now_ms),
                    // 🔧 递归调用时使用 started_at 作为 first_chunk_at
                    first_chunk_at: Some(started_at),
                    block_index: 0, // 会被 add_interleaved_block 重新设置
                };
                self.add_interleaved_block(block);
                // 🔧 P3修复：更新上一个块的结束时间
                self.last_block_ended_at = Some(now_ms);
            }
        }

        // 添加 content 块（如果有）
        // 注意：在工具调用后可能没有 content（LLM 返回的是 tool_use）
        if let (Some(block_id), Some(content)) = (content_block_id, content_text) {
            if !content.is_empty() {
                // 🔧 P3修复：使用上一个块的结束时间作为本块的开始时间
                let started_at = self.last_block_ended_at.unwrap_or(context_start_ms);
                let block = MessageBlock {
                    id: block_id,
                    message_id: message_id.to_string(),
                    block_type: block_types::CONTENT.to_string(),
                    status: block_status::SUCCESS.to_string(),
                    content: Some(content),
                    tool_name: None,
                    tool_input: None,
                    tool_output: None,
                    citations: None,
                    error: None,
                    started_at: Some(started_at),
                    ended_at: Some(now_ms),
                    // 🔧 递归调用时使用 started_at 作为 first_chunk_at
                    first_chunk_at: Some(started_at),
                    block_index: 0,
                };
                self.add_interleaved_block(block);
                // 🔧 P3修复：更新上一个块的结束时间
                self.last_block_ended_at = Some(now_ms);
            }
        }
    }

    /// 添加工具调用块到交替列表
    ///
    /// ## 与检索事件的单一写入契约（P2-6）
    /// 检索工具（rag/web_search 等）通过 `emit_start`/`emit_end` 发射事件驱动前端
    /// 实时渲染，但**不**调用 `save_tool_block` 落库；块的持久化唯一入口是本方法
    /// （经 `add_interleaved_block` → `save_results`）。事件与持久化块共享同一
    /// `block_id`（`tool_result.block_id` == 事件的 `ctx.block_id`），且
    /// `add_interleaved_block` 对重复块 ID 幂等，因此不存在同 block_id 的双写竞态。
    ///
    /// ## 参数
    /// - `tool_result`: 工具调用结果
    /// - `message_id`: 消息 ID
    pub(crate) fn add_tool_block(&mut self, tool_result: &ToolResultInfo, message_id: &str) {
        let now_ms = chrono::Utc::now().timestamp_millis();

        // 使用工具结果中记录的 block_id
        let block_id = tool_result
            .block_id
            .clone()
            .unwrap_or_else(MessageBlock::generate_id);

        // 🔧 P0 修复：检索工具使用正确的块类型，而非通用的 mcp_tool
        // 这样前端 sourceAdapter 能正确从 toolOutput.sources 中提取来源
        let block_type = Self::get_block_type_for_tool(&tool_result.tool_name);

        // 工具块使用自己的执行时间（有记录的 duration_ms）
        let started_at = now_ms - tool_result.duration_ms.unwrap_or(0) as i64;
        let block = MessageBlock {
            id: block_id,
            message_id: message_id.to_string(),
            block_type,
            status: if tool_result.success {
                block_status::SUCCESS.to_string()
            } else {
                block_status::ERROR.to_string()
            },
            content: None,
            tool_name: Some(tool_result.tool_name.clone()),
            tool_input: Some(tool_result.input.clone()),
            tool_output: Some(tool_result.output.clone()),
            citations: None,
            error: if tool_result.success {
                None
            } else {
                tool_result.error.clone()
            },
            started_at: Some(started_at),
            ended_at: Some(now_ms),
            // 🔧 工具块使用 started_at 作为排序依据
            first_chunk_at: Some(started_at),
            block_index: 0,
        };
        self.add_interleaved_block(block);
        // 🔧 P3修复：更新上一个块的结束时间，让后续 thinking 块能正确计算时间
        self.last_block_ended_at = Some(now_ms);
    }

    /// 检查是否有交替块（用于判断是否使用新的保存逻辑）
    pub(crate) fn has_interleaved_blocks(&self) -> bool {
        !self.interleaved_block_ids.is_empty()
    }

    /// 根据工具名称获取正确的块类型
    ///
    /// 🔧 P0 修复：检索工具（builtin-*_search）使用语义化的块类型，
    /// 这样前端 sourceAdapter 能正确识别并从 toolOutput.sources 中提取来源。
    ///
    /// ## 映射规则
    /// - `builtin-rag_search` / `builtin-multimodal_search` / `builtin-unified_search` → `rag`
    /// - `builtin-memory_search` → `memory`
    /// - `builtin-web_search` → `web_search`
    /// - 其他工具 → `mcp_tool`
    fn get_block_type_for_tool(tool_name: &str) -> String {
        Self::get_block_type_for_tool_static(tool_name)
    }

    pub fn get_block_type_for_tool_static(tool_name: &str) -> String {
        let stripped = tool_name.strip_prefix("builtin-").unwrap_or(tool_name);

        // ACR R2-05 / R3-01：workbench_* 与域委托写持久化为 workbench_ops（撤销入口）
        if stripped.starts_with("workbench_")
            || matches!(
                stripped,
                "note_append" | "note_replace" | "note_set" | "mindmap_edit_nodes"
            )
        {
            return block_types::WORKBENCH_OPS.to_string();
        }

        match stripped {
            "rag_search" | "multimodal_search" | "unified_search" => block_types::RAG.to_string(),
            "memory_search" => block_types::MEMORY.to_string(),
            "web_search" => block_types::WEB_SEARCH.to_string(),
            "arxiv_search" | "scholar_search" => block_types::ACADEMIC_SEARCH.to_string(),
            "image_generate" => block_types::IMAGE_GEN.to_string(),
            "render_generative_ui" => block_types::GENERATIVE_UI.to_string(),
            "coordinator_sleep" => block_types::SLEEP.to_string(),
            "subagent_call" => block_types::SUBAGENT_EMBED.to_string(),
            // 🆕 契约 C11 配套（缺口 2 历史加载侧）：前端为 workspace_send 建专属块，
            // 历史加载时工具块类型必须与实时块一致
            "workspace_send" => block_types::WORKSPACE_SEND.to_string(),
            "ask_user" => block_types::ASK_USER.to_string(),
            _ => block_types::MCP_TOOL.to_string(),
        }
    }

    // ========== 统一上下文注入系统方法 ==========

    /// 从上下文引用构建用户内容块
    ///
    /// 将 SendContextRef 列表中的 formattedBlocks 拼接成 ContentBlock 列表。
    /// 后端直接使用 formattedBlocks，不关心具体类型。
    ///
    /// ## 约束
    /// - 后端直接使用 formattedBlocks，不需要知道资源的具体类型
    /// - 按照引用顺序拼接，保持前端定义的顺序
    ///
    /// ## 参数
    /// - `refs`: SendContextRef 列表（包含格式化后的内容块）
    ///
    /// ## 返回
    /// 拼接后的 ContentBlock 列表
    pub(crate) fn build_user_content_from_context_refs(
        refs: &[SendContextRef],
    ) -> Vec<ContentBlock> {
        let mut blocks = Vec::new();
        for context_ref in refs {
            blocks.extend(context_ref.formatted_blocks.clone());
        }
        log::debug!(
            "[ChatV2::pipeline] Built {} content blocks from {} context refs",
            blocks.len(),
            refs.len()
        );
        blocks
    }

    pub(crate) fn build_user_query_block(user_content: &str) -> Option<String> {
        if user_content.is_empty() {
            None
        } else {
            Some(format!(
                "<user_query>\n{}\n</user_query>",
                escape_xml_content(user_content)
            ))
        }
    }

    pub(crate) fn wrap_user_message_text(
        user_content: &str,
        injected_context: Option<&str>,
    ) -> String {
        let mut combined_text = String::new();

        if let Some(user_query) = Self::build_user_query_block(user_content) {
            combined_text.push_str(&user_query);
        }

        if let Some(injected) = injected_context.filter(|text| !text.is_empty()) {
            if !combined_text.is_empty() {
                combined_text.push_str("\n\n");
            }
            combined_text.push_str(&format!(
                "<injected_context>\n{}\n</injected_context>",
                injected
            ));
        }

        combined_text
    }

    fn is_time_sensitive_query(user_content: &str) -> bool {
        let content = user_content.trim();
        if content.is_empty() {
            return false;
        }

        let lower = content.to_ascii_lowercase();
        let excluded_terms = [
            "时间复杂度",
            "空间复杂度",
            "time complexity",
            "space complexity",
        ];
        if excluded_terms
            .iter()
            .any(|term| content.contains(term) || lower.contains(term))
        {
            return false;
        }

        let zh_keywords = [
            "当前时间",
            "现在几点",
            "现在几号",
            "现在是",
            "今天",
            "明天",
            "昨天",
            "后天",
            "今晚",
            "今早",
            "日期",
            "周几",
            "星期几",
            "时区",
            "本周",
            "下周",
            "本月",
            "今年",
            "明年",
            "截止",
            "到期",
            "过期",
        ];
        if zh_keywords.iter().any(|keyword| content.contains(keyword)) {
            return true;
        }

        let en_keywords = [
            "current time",
            "what time",
            "right now",
            "current date",
            "today",
            "tomorrow",
            "yesterday",
            "timezone",
            "this week",
            "next week",
            "this month",
            "this year",
            "deadline",
            "due date",
            "expires",
            "expiration",
        ];
        en_keywords.iter().any(|keyword| lower.contains(keyword))
    }

    pub(crate) fn build_runtime_facts_block(user_content: &str) -> String {
        let now = chrono::Local::now();
        let platform = std::env::consts::OS;
        let shell = local_shell_contract_for_platform(platform);
        let temporal_fact = if Self::is_time_sensitive_query(user_content) {
            format!("当前时间: {}", now.format("%Y-%m-%d %H:%M:%S"))
        } else {
            format!("当前日期: {}", now.format("%Y-%m-%d"))
        };

        format!(
            "<runtime_facts>\n{}\n时区: {}\nos: {}\nplatform: {}\nlocal_shell: {}\nshell_path: {}\nsandbox_backend: {}\nshell_kind: {}\noutput_encoding: {}\nexecution_supported: {}\nnon_interactive: true\npty_available: false\npersistent_shell_session: false\nnetwork_default: deny\n</runtime_facts>",
            temporal_fact,
            now.format("%:z"),
            shell.os,
            platform,
            shell.invocation.unwrap_or("none"),
            shell.shell_path.unwrap_or("none"),
            shell.sandbox_backend,
            shell.shell_kind,
            shell.output_encoding.unwrap_or("none"),
            shell.execution_supported,
        )
    }

    /// 组装 `<injected_context>` 内的内容块
    ///
    /// ## P1-10：turn-volatile 迁出 system
    /// 顺序：runtime_facts → 用户上下文引用（formattedBlocks）→ turn-volatile 块
    /// （格式 hints / 画像 / 待办 / 检索 context / Canvas 笔记）。
    /// turn-volatile 块由 prompt_builder 拆分产出，各块内部已按旧 system
    /// 注入规则完成 XML 转义，此处按预编排 XML 段原样拼接（同 runtime_facts）。
    pub(crate) fn build_injected_context_blocks(
        runtime_facts: &str,
        refs: &[SendContextRef],
        turn_volatile: Option<&str>,
    ) -> Vec<ContentBlock> {
        let mut blocks = vec![ContentBlock::text(runtime_facts.to_string())];
        blocks.extend(Self::build_user_content_from_context_refs(refs));
        if let Some(volatile) = turn_volatile.filter(|text| !text.is_empty()) {
            blocks.push(ContentBlock::text(volatile.to_string()));
        }
        blocks
    }

    pub(crate) fn collect_injected_context_text_and_images(
        blocks: &[ContentBlock],
    ) -> (String, Vec<String>) {
        let mut context_text = String::new();
        let mut context_images: Vec<String> = Vec::new();

        for block in blocks {
            match block {
                ContentBlock::Text { text } => {
                    if !context_text.is_empty() {
                        context_text.push_str("\n\n");
                    }
                    context_text.push_str(text);
                }
                ContentBlock::Image { base64, .. } => {
                    context_images.push(base64.clone());
                }
            }
        }

        (context_text, context_images)
    }

    /// 获取合并后的用户内容（统一上下文注入系统）
    ///
    /// 将 user_context_refs 中的 formattedBlocks 与 user_content 合并。
    ///
    /// ## 组装顺序（用户输入优先）
    /// 1. `<user_query>` - 用户输入内容（用 XML 标签包裹，确保 LLM 注意力聚焦）
    /// 2. `<injected_context>` - 注入的上下文内容（包含 <runtime_facts> 和其他上下文）
    ///
    /// ## 返回
    /// - 合并后的用户内容文本
    /// - 从 formattedBlocks 中提取的图片 base64 列表
    pub(crate) fn get_combined_user_content(&self) -> (String, Vec<String>) {
        let injected_blocks = Self::build_injected_context_blocks(
            &self.runtime_facts,
            &self.user_context_refs,
            self.turn_volatile_context.as_deref(),
        );
        let (context_text, context_images) =
            Self::collect_injected_context_text_and_images(&injected_blocks);
        let combined_text =
            Self::wrap_user_message_text(&self.user_content, Some(context_text.as_str()));

        log::debug!(
            "[ChatV2::pipeline] Combined user content: context_refs={}, context_images={}, total_len={}",
            self.user_context_refs.len(),
            context_images.len(),
            combined_text.len()
        );

        (combined_text, context_images)
    }

    /// V20260806 B 层：当前用户消息 live 实际发送的完整包装文本
    ///
    /// 优先取 `compiled_current_user_message`（context_compiler 冻结后的
    /// 最终请求内容，含 `<user_query>` 包装 + `<injected_context>`/
    /// `<runtime_facts>` 及可能的派生 artifact 文本）；尚未编译时返回 None，
    /// 由后续保存点（编译发生在首次 LLM 调用前）补写，避免把与 live 不一致
    /// 的中间形态落进 `llm_content` 列。
    pub(crate) fn live_user_llm_content(&self) -> Option<String> {
        self.compiled_current_user_message
            .as_ref()
            .map(|message| message.content.clone())
            .filter(|content| !content.is_empty())
    }

    /// 将用户上下文引用转换为 ContextRef（丢弃 formattedBlocks）
    ///
    /// 消息保存时只存 ContextRef，不存实际内容。
    ///
    /// ## 参数
    /// - `refs`: SendContextRef 列表
    ///
    /// ## 返回
    /// ContextRef 列表
    pub(crate) fn convert_to_context_refs(refs: &[SendContextRef]) -> Vec<ContextRef> {
        refs.iter().map(|r| r.to_context_ref()).collect()
    }

    /// 初始化上下文快照（填充 user_refs）
    ///
    /// 在消息发送开始时调用，将用户上下文引用保存到快照中。
    pub(crate) fn init_context_snapshot(&mut self) {
        // Re-entry is expected (the crash-safe save initializes before execute_internal).
        // Preserve retrieval refs/path_map while rebuilding user refs deterministically.
        self.context_snapshot.user_refs.clear();
        // 将 SendContextRef 转换为 ContextRef
        for send_ref in &self.user_context_refs {
            self.context_snapshot
                .add_user_ref(send_ref.to_context_ref());
        }
        log::debug!(
            "[ChatV2::pipeline] Initialized context snapshot with {} user refs",
            self.context_snapshot.user_refs.len()
        );
    }

    /// 添加检索结果到上下文快照
    ///
    /// 检索结果创建资源后调用，将检索上下文引用添加到快照中。
    ///
    /// ## 参数
    /// - `refs`: 检索资源的 ContextRef 列表
    pub(crate) fn add_retrieval_refs_to_snapshot(&mut self, refs: Vec<ContextRef>) {
        for context_ref in refs {
            self.context_snapshot.add_retrieval_ref(context_ref);
        }
        log::debug!(
            "[ChatV2::pipeline] Added {} retrieval refs to context snapshot",
            self.context_snapshot.retrieval_refs.len()
        );
    }

    /// ★ 获取保持原始顺序的内容块列表（支持图文交替）
    ///
    /// 用于多模态场景，保持 ContentBlock 的原始顺序（图片和文本交替）。
    /// 这个方法不会将文本合并或将图片分离，而是保持前端/格式化模块返回的原始顺序。
    ///
    /// ## 组装顺序
    /// 1. `<user_query>` 文本块（用户输入）
    /// 2. `<injected_context>` 开始标签
    /// 3. `<runtime_facts>` + 按原始顺序的 ContentBlock（图片和文本交替）
    /// 4. `</injected_context>` 结束标签
    ///
    /// ## 返回
    /// - `Vec<ContentBlock>`: 保持原始顺序的内容块列表
    ///
    /// ## 用途
    /// - 多模态 AI 模型（如 GPT-4V、Claude 3）需要图文交替的输入格式
    /// - 题目集识别等混合类型数据的上下文注入
    ///
    /// ★ 文档25：此方法现在被 build_current_user_message 调用
    pub(crate) fn get_content_blocks_ordered(&self) -> Vec<ContentBlock> {
        let mut blocks: Vec<ContentBlock> = Vec::new();

        // 1. 用户输入在前（用 XML 标签包裹）
        if let Some(user_query) = Self::build_user_query_block(&self.user_content) {
            blocks.push(ContentBlock::text(user_query));
        }

        // 2. 处理上下文引用的 formattedBlocks（保持原始顺序）
        let injected_blocks = Self::build_injected_context_blocks(
            &self.runtime_facts,
            &self.user_context_refs,
            self.turn_volatile_context.as_deref(),
        );
        if !injected_blocks.is_empty() {
            blocks.push(ContentBlock::text("<injected_context>".to_string()));
            blocks.extend(injected_blocks);
            blocks.push(ContentBlock::text("</injected_context>".to_string()));
        }

        log::debug!(
            "[ChatV2::pipeline] get_content_blocks_ordered: total_blocks={}",
            blocks.len()
        );

        blocks
    }

    /// ★ 构建多模态消息内容（用于 LLM 请求体）
    ///
    /// 将 ContentBlock 列表转换为 LLM API 所需的 JSON 格式。
    /// 支持 OpenAI/Anthropic/Gemini 的多模态消息格式。
    ///
    /// ## 参数
    /// - `content_blocks`: ContentBlock 列表
    ///
    /// ## 返回
    /// - `Vec<serde_json::Value>`: JSON 格式的消息内容部分
    #[allow(dead_code)]
    pub fn build_multimodal_message_parts(
        content_blocks: &[ContentBlock],
    ) -> Vec<serde_json::Value> {
        use serde_json::json;

        content_blocks
            .iter()
            .map(|block| match block {
                ContentBlock::Text { text } => {
                    json!({
                        "type": "text",
                        "text": text
                    })
                }
                ContentBlock::Image { media_type, base64 } => {
                    json!({
                        "type": "image_url",
                        "image_url": {
                            "url": format!("data:{};base64,{}", media_type, base64)
                        }
                    })
                }
            })
            .collect()
    }

    // ========== 工作区消息注入方法 ==========

    /// 注入工作区消息到聊天历史
    ///
    /// 将工作区消息格式化为系统消息并添加到聊天历史中，
    /// 使 LLM 能够感知并响应工作区中的通信。
    ///
    /// ## 参数
    /// - `formatted_messages`: 格式化后的工作区消息字符串
    ///
    /// ## 返回
    /// 是否成功注入
    pub(crate) fn inject_workspace_messages(&mut self, formatted_messages: String) -> bool {
        if formatted_messages.is_empty() {
            return false;
        }

        // 创建一个系统消息来传递工作区消息
        let workspace_msg = LegacyChatMessage {
            role: "user".to_string(), // 使用 user 角色，因为这代表来自其他 Agent 的消息
            content: formatted_messages,
            timestamp: chrono::Utc::now(),
            thinking_content: None,
            thought_signature: None,
            rag_sources: None,
            memory_sources: None,
            graph_sources: None,
            web_search_sources: None,
            image_paths: None,
            image_base64: None,
            doc_attachments: None,
            multimodal_content: None,
            tool_call: None,
            tool_result: None,
            overrides: None,
            relations: None,
            persistent_stable_id: None,
            metadata: Some(serde_json::json!({
                "workspace_injection": true,
                "workspace_id": self.workspace_id
            })),
        };

        self.chat_history.push(workspace_msg);
        self.workspace_injection_count += 1;

        log::debug!(
            "[ChatV2::context] Injected workspace messages, total injections: {}",
            self.workspace_injection_count
        );

        true
    }

    /// 检查是否需要继续执行（有待处理的工作区消息时）
    ///
    /// ## 返回
    /// 是否需要继续 LLM 调用
    pub(crate) fn should_continue_for_workspace(&self) -> bool {
        // 如果本轮有注入过工作区消息，需要继续执行让 LLM 处理
        self.workspace_injection_count > 0 && self.workspace_id.is_some()
    }

    /// 获取工作区 ID（如果有）
    pub(crate) fn get_workspace_id(&self) -> Option<&str> {
        self.workspace_id.as_deref()
    }

    /// 设置工作区 ID
    pub(crate) fn set_workspace_id(&mut self, workspace_id: Option<String>) {
        self.workspace_id = workspace_id;
    }

    /// 获取本轮工作区消息注入次数
    pub(crate) fn get_workspace_injection_count(&self) -> u32 {
        self.workspace_injection_count
    }

    /// 重置工作区注入计数（新一轮 LLM 调用开始时）
    pub(crate) fn reset_workspace_injection_count(&mut self) {
        self.workspace_injection_count = 0;
    }
}

// ============================================================
// 单元测试
// ============================================================

#[cfg(test)]
mod citation_tests {
    use super::*;

    #[test]
    fn ledger_reuses_index_for_same_identity_across_calls() {
        let mut ledger = CitationLedger::new();
        // 第一次工具调用
        let first = ledger.assign("rag", "res:doc_a|c:0");
        let second = ledger.assign("rag", "res:doc_b|c:1");
        assert_eq!((first.type_index, first.is_new), (1, true));
        assert_eq!((second.type_index, second.is_new), (2, true));
        // 第二次工具调用：doc_a 复用编号 1，新来源全局递增到 3
        let repeat = ledger.assign("rag", "res:doc_a|c:0");
        assert_eq!((repeat.type_index, repeat.is_new), (1, false));
        let third = ledger.assign("rag", "res:doc_c|c:0");
        assert_eq!((third.type_index, third.is_new), (3, true));
    }

    #[test]
    fn ledger_counts_groups_independently() {
        let mut ledger = CitationLedger::new();
        assert_eq!(ledger.assign("rag", "res:a").type_index, 1);
        assert_eq!(ledger.assign("multimodal", "res:a|p:0").type_index, 1);
        assert_eq!(ledger.assign("memory", "note:x").type_index, 1);
        assert_eq!(ledger.assign("rag", "res:b").type_index, 2);
    }

    #[test]
    fn ledger_registry_is_stable_per_reply_and_isolated_per_variant() {
        let ledger_a = citation_ledger_for_reply("sess_ct", "msg_ct_1", None);
        ledger_a.lock().unwrap().assign("rag", "res:shared");
        // 同一回复再次获取：拿到同一账本（编号被复用）
        let ledger_a_again = citation_ledger_for_reply("sess_ct", "msg_ct_1", None);
        let repeat = ledger_a_again.lock().unwrap().assign("rag", "res:shared");
        assert_eq!((repeat.type_index, repeat.is_new), (1, false));
        // 不同变体：独立账本
        let ledger_b = citation_ledger_for_reply("sess_ct", "msg_ct_1", Some("var_1"));
        let fresh = ledger_b.lock().unwrap().assign("rag", "res:shared");
        assert!(fresh.is_new);
    }

    #[test]
    fn sanitize_strips_local_paths_and_diagnostics_but_keeps_web_urls() {
        let output = json!({
            "success": true,
            "retrievalPlan": { "routes": [] },
            "capabilitySnapshot": { "profiles": [] },
            "sources": [
                {
                    "citationTag": "[图片-1]",
                    "url": "asset://localhost/blobs/abc.png",
                    "imageUrl": "asset://localhost/blobs/abc.png",
                    "imageCitation": "![Page 1](asset://localhost/blobs/abc.png)",
                    "blob_hash": "deadbeef",
                    "retrievalProvenance": [{ "routeId": "mm" }],
                    "snippet": "page text",
                    "readResourceId": "res_1"
                },
                {
                    "citationTag": "[搜索-1]",
                    "url": "https://example.com/article",
                    "snippet": "web text"
                }
            ]
        });
        let sanitized =
            sanitize_retrieval_output_for_llm("builtin-unified_search", &output).expect("applies");
        assert!(sanitized.get("retrievalPlan").is_none());
        assert!(sanitized.get("capabilitySnapshot").is_none());
        let sources = sanitized["sources"].as_array().unwrap();
        assert!(sources[0].get("url").is_none());
        assert!(sources[0].get("imageUrl").is_none());
        assert!(sources[0].get("imageCitation").is_none());
        assert!(sources[0].get("blob_hash").is_none());
        assert!(sources[0].get("retrievalProvenance").is_none());
        // LLM 仍能看到 snippet 与 readResourceId
        assert_eq!(sources[0]["snippet"], "page text");
        assert_eq!(sources[0]["readResourceId"], "res_1");
        // 真实网络 URL 保留
        assert_eq!(sources[1]["url"], "https://example.com/article");
        // 原始 output 不被修改（前端/持久化仍是全量）
        assert!(output["sources"][0].get("imageUrl").is_some());
    }

    #[test]
    fn sanitize_skips_non_retrieval_tools() {
        let output = json!({ "sources": [{ "imageUrl": "asset://x" }] });
        assert!(sanitize_retrieval_output_for_llm("builtin-note_read", &output).is_none());
        assert!(sanitize_retrieval_output_for_llm("mcp_custom_tool", &output).is_none());
    }
}

// ============================================================
// P1-10：turn-volatile 迁入当前 user <injected_context> 的单元测试
// ============================================================

#[cfg(test)]
mod turn_volatile_tests {
    use super::*;

    const FIXED_FACTS: &str = "<runtime_facts>\n当前日期: 2026-08-23\n</runtime_facts>";

    fn build_user_text(volatile: Option<&str>) -> String {
        let blocks = PipelineContext::build_injected_context_blocks(FIXED_FACTS, &[], volatile);
        let (text, images) = PipelineContext::collect_injected_context_text_and_images(&blocks);
        assert!(images.is_empty());
        PipelineContext::wrap_user_message_text("同一个问题", Some(text.as_str()))
    }

    #[test]
    fn injected_context_carries_turn_volatile_blocks() {
        let volatile = "<active_todos>\n以下是用户当前的待办事项：\n1. 复习\n</active_todos>";
        let combined = build_user_text(Some(volatile));

        // user_query 在前且不含 volatile 内容
        let query_end = combined.find("</user_query>").expect("user_query block");
        assert!(!combined[..query_end].contains("active_todos"));

        // volatile 落在 <injected_context> 内部
        let ic_start = combined
            .find("<injected_context>")
            .expect("injected_context open");
        let ic_end = combined
            .find("</injected_context>")
            .expect("injected_context close");
        let injected = &combined[ic_start..ic_end];
        assert!(injected.contains("<runtime_facts>"));
        assert!(injected.contains(volatile));
    }

    /// P1-10 跨轮快照（user 消息侧）：volatile 逐轮变化时，
    /// `<injected_context>` 之前的字节（user_query + 包装骨架）逐轮不变，
    /// 变化只发生在 injected_context 内部。
    #[test]
    fn cross_turn_changes_stay_inside_injected_context() {
        let round1 = build_user_text(Some("<context>\n[知识库-1] 第一轮命中\n</context>"));
        let round2 = build_user_text(Some("<context>\n[知识库-1] 第二轮命中\n</context>"));

        let prefix1 = &round1[..round1.find("<injected_context>").unwrap()];
        let prefix2 = &round2[..round2.find("<injected_context>").unwrap()];
        assert_eq!(prefix1, prefix2);
        assert!(round1.contains("第一轮命中") && !round1.contains("第二轮命中"));
        assert!(round2.contains("第二轮命中") && !round2.contains("第一轮命中"));
    }

    /// P1-10 R4：runtime_facts（含当前日期/时间）的唯一归属是当前 user
    /// 消息的 <injected_context>——本测试确认日期字节确实存在于
    /// injected_context 内部；system 侧不含日期由
    /// prompt_builder::tests::test_stable_system_free_of_runtime_facts_and_dates
    /// 保证，两端合起来构成「日期不在 system」的完整回归。
    #[test]
    fn runtime_facts_with_date_live_inside_injected_context() {
        let facts = PipelineContext::build_runtime_facts_block("讲讲牛顿第二定律");
        assert!(facts.starts_with("<runtime_facts>"));
        assert!(facts.contains("当前日期: "));
        let today = chrono::Local::now().format("%Y-%m-%d").to_string();
        assert!(facts.contains(&today));

        let blocks = PipelineContext::build_injected_context_blocks(&facts, &[], None);
        let (text, images) = PipelineContext::collect_injected_context_text_and_images(&blocks);
        assert!(images.is_empty());
        let combined =
            PipelineContext::wrap_user_message_text("讲讲牛顿第二定律", Some(text.as_str()));

        // runtime_facts 位于 <injected_context> 内部，且不泄漏进 user_query
        let ic_start = combined
            .find("<injected_context>")
            .expect("injected_context open");
        let ic_end = combined
            .find("</injected_context>")
            .expect("injected_context close");
        let facts_pos = combined
            .find("<runtime_facts>")
            .expect("runtime_facts block");
        assert!(ic_start < facts_pos && facts_pos < ic_end);
        let query_end = combined.find("</user_query>").expect("user_query block");
        assert!(!combined[..query_end].contains("runtime_facts"));
        assert!(!combined[..query_end].contains(&today));
    }

    /// 时间敏感问法升级为「当前时间」精度，但仍只影响 user 消息侧，
    /// 与 system 无关（system 侧断言见 prompt_builder 测试）。
    #[test]
    fn time_sensitive_query_upgrades_runtime_fact_precision() {
        let normal = PipelineContext::build_runtime_facts_block("讲讲牛顿第二定律");
        assert!(normal.contains("当前日期: "));
        assert!(!normal.contains("当前时间: "));

        let sensitive = PipelineContext::build_runtime_facts_block("今天是几号？");
        assert!(sensitive.contains("当前时间: "));
    }

    #[test]
    fn empty_turn_volatile_keeps_previous_block_shape() {
        let none = PipelineContext::build_injected_context_blocks(FIXED_FACTS, &[], None);
        assert_eq!(none.len(), 1);
        // 空串等价于无 volatile，不追加空文本块
        let empty = PipelineContext::build_injected_context_blocks(FIXED_FACTS, &[], Some(""));
        assert_eq!(empty.len(), 1);
    }
}
