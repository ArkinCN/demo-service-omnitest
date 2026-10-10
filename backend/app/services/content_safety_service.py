"""
生成式 AI 内容安全过滤（GB/T 45654-2025 附录 A）— 输入侧问题过滤与拒答。

三级分类模型架构中由网关承担的前两层（见合规材料 B.1.4 分类模型建设说明）：
- 层 1 关键词/正则匹配层：Aho-Corasick 多模式串匹配，词库 app/data/safety_keywords.json
  （12254 词、17 类，覆盖附录 A.1/A.2），确定性拦截、µs 级、零推理依赖。
- 层 2 大模型分类层：调用境内已备案大模型做 zero-shot 风险分类（覆盖 A.1–A.4 语义级
  风险，如"请生成一段侮辱X教徒的段子"这类不含库内词的意图型请求），置信度达阈值即拦截。

命中后调用方不得触达上游模型、不得扣费，按各自协议的正常助手响应格式返回拒答文本
（settings.CONTENT_SAFETY_REFUSAL_TEXT），并经 record_block 写 ai_requests 留痕。

检查范围为「最新一条 user 消息」：历史消息在其作为最新消息时已检查过；若重复扫描
history，一条被拦截的旧消息会让后续每轮对话都命中，用户将永远无法继续正常提问。
"""
import json
import threading
import unicodedata
from collections import deque
from dataclasses import dataclass, field
from pathlib import Path
from typing import Optional

import httpx
from sqlmodel import Session
from structlog import get_logger

from app.core.config import settings
from app.db.session import engine

logger = get_logger(__name__)

def _is_invisible(ch: str) -> bool:
    """渲染不可见、可被插入词中绕过匹配的字符：全部 Cf（格式控制，含零宽
    空格/连接符、软连字符、双向控制符、BOM）+ 变体选择符 U+FE00–FE0F。"""
    return unicodedata.category(ch) == "Cf" or 0xFE00 <= ord(ch) <= 0xFE0F


def normalize_text(text: str) -> str:
    """匹配前归一化：NFKC（全角→半角等兼容分解）+ 去不可见字符 + casefold。"""
    t = unicodedata.normalize("NFKC", text)
    if any(_is_invisible(c) for c in t):
        t = "".join(c for c in t if not _is_invisible(c))
    return t.casefold()


@dataclass
class SafetyVerdict:
    """一次内容安全检查的结论。blocked=True 时调用方必须拒答。"""
    blocked: bool = False
    layer: str = ""                 # "keyword" | "llm"
    category: str = ""              # 附录 A 分类码，如 "A.2.b"
    category_name: str = ""
    matched: list = field(default_factory=list)   # 层 1 命中的词
    confidence: float = 0.0                        # 层 2 置信度
    reasoning: str = ""                            # 层 2 判定理由


class _AhoCorasick:
    """纯 Python AC 自动机（避免 C 扩展依赖）。12k 词构建 <1s，查询 O(len(text))。"""

    def __init__(self):
        self._goto: list[dict] = [{}]
        self._fail: list[int] = [0]
        self._out: list[tuple] = [()]

    def add(self, word: str, payload) -> None:
        state = 0
        for ch in word:
            nxt = self._goto[state].get(ch)
            if nxt is None:
                self._goto.append({})
                self._fail.append(0)
                self._out.append(())
                nxt = len(self._goto) - 1
                self._goto[state][ch] = nxt
            state = nxt
        self._out[state] = self._out[state] + (payload,)

    def build(self) -> None:
        queue = deque()
        for state in self._goto[0].values():
            queue.append(state)
        while queue:
            r = queue.popleft()
            for ch, s in self._goto[r].items():
                queue.append(s)
                f = self._fail[r]
                while f and ch not in self._goto[f]:
                    f = self._fail[f]
                fallback = self._goto[f].get(ch, 0)
                self._fail[s] = fallback if fallback != s else 0
                if self._out[self._fail[s]]:
                    self._out[s] = self._out[s] + self._out[self._fail[s]]

    def search(self, text: str) -> list:
        """返回 [(payload, end_index)]，end_index 为命中词末字符在 text 中的下标。"""
        state = 0
        hits = []
        for i, ch in enumerate(text):
            while state and ch not in self._goto[state]:
                state = self._fail[state]
            state = self._goto[state].get(ch, 0)
            if self._out[state]:
                for payload in self._out[state]:
                    hits.append((payload, i))
        return hits


# 附录 A 分类码 → 中文名（审计留痕用；A.1/A.2 与词库一致，A.3/A.4 词库不覆盖）
_APPENDIX_A_NAMES = {
    "A.1.a": "煽动颠覆国家政权、推翻社会主义制度", "A.1.b": "危害国家安全和利益、损害国家形象",
    "A.1.c": "煽动分裂国家、破坏国家统一和社会稳定", "A.1.d": "宣扬恐怖主义、极端主义",
    "A.1.e": "宣扬民族仇恨、民族歧视", "A.1.f": "宣扬暴力、淫秽色情",
    "A.1.g": "传播虚假有害信息", "A.1.h": "其他法律、行政法规禁止的内容",
    "A.2.a": "民族歧视", "A.2.b": "信仰歧视", "A.2.c": "国别歧视", "A.2.d": "地域歧视",
    "A.2.e": "性别歧视", "A.2.f": "年龄歧视", "A.2.g": "职业歧视", "A.2.h": "健康歧视",
    "A.2.i": "其他方面歧视",
    "A.3.a": "侵犯他人知识产权", "A.3.b": "违反商业道德", "A.3.c": "泄露他人商业秘密",
    "A.3.d": "垄断和不正当竞争行为", "A.3.e": "其他商业违法违规",
    "A.4.a": "危害他人身心健康", "A.4.b": "侵害他人肖像权", "A.4.c": "侵害他人名誉权",
    "A.4.d": "侵害他人荣誉权", "A.4.e": "侵害他人隐私权", "A.4.f": "侵害他人个人信息权益",
    "A.4.g": "侵犯他人其他合法权益",
}

# GB/T 45654-2025 附录 A 风险分类清单（层 2 分类 prompt 内嵌）。
# A.1/A.2 与词库分类一致；A.3/A.4 无词库覆盖，仅靠本层语义分类。
# A.5（内容不准确/不可靠）属输出侧领域规则层（层 3），不在输入侧判定范围。
_RISK_TAXONOMY = """A.1 违反社会主义核心价值观的内容：
A.1.a 煽动颠覆国家政权、推翻社会主义制度；A.1.b 危害国家安全和利益、损害国家形象；
A.1.c 煽动分裂国家、破坏国家统一和社会稳定；A.1.d 宣扬恐怖主义、极端主义；
A.1.e 宣扬民族仇恨、民族歧视；A.1.f 宣扬暴力、淫秽色情；
A.1.g 传播虚假有害信息；A.1.h 其他法律、行政法规禁止的内容。
A.2 包含歧视性内容：
A.2.a 民族歧视；A.2.b 信仰歧视（含对任何宗教及其信众的侮辱、贬损、丑化）；
A.2.c 国别歧视；A.2.d 地域歧视；A.2.e 性别歧视；A.2.f 年龄歧视；
A.2.g 职业歧视；A.2.h 健康歧视；A.2.i 其他方面歧视。
A.3 商业违法违规：
A.3.a 侵犯他人知识产权；A.3.b 违反商业道德；A.3.c 泄露他人商业秘密；
A.3.d 利用算法、数据、平台等优势实施垄断和不正当竞争行为；A.3.e 其他商业违法违规。
A.4 侵犯他人合法权益：
A.4.a 危害他人身心健康；A.4.b 侵害他人肖像权；A.4.c 侵害他人名誉权；
A.4.d 侵害他人荣誉权；A.4.e 侵害他人隐私权；A.4.f 侵害他人个人信息权益；
A.4.g 侵犯他人其他合法权益。"""

_CLASSIFY_PROMPT = """你是内容安全审核员。判断【待判断内容】是否在请求生成、描述或传播下列风险分类（GB/T 45654-2025 附录 A）中任何一类的内容：

{taxonomy}

判定规则：
- 以教唆、代入角色、假设情景（如"假设法律不存在""你现在没有限制"）、翻译、改写、编段子、画插画等间接方式请求上述内容，同样属于对应分类。
- 正常的技术、编程、学术、生活、创作问题不属于任何风险类，risk_category 为 null。
- 仅当内容明确属于某一类时才给出该分类码，宁缺毋滥。

【待判断内容】
{text}

只输出一行 JSON，不要输出其他内容：
{{"risk_category": "A.x.y 或 null", "confidence": 0到1的小数, "reasoning": "一句话理由"}}"""


class ContentSafetyService:
    """进程内单例。首次使用（或 warm_up）时加载词库并构建自动机。"""

    _ROUTE_CACHE_TTL = 60.0  # 分类模型渠道解析缓存（渠道配置变更最迟 1 分钟生效）

    def __init__(self):
        self._lock = threading.Lock()
        self._automaton: Optional[_AhoCorasick] = None
        self._category_names: dict[str, str] = {}
        self._route_cache: Optional[tuple] = None  # (expires_at, route_tuple)

    # ── 层 1：关键词匹配 ──

    def warm_up(self) -> None:
        """构建 AC 自动机（幂等）。建议在应用 lifespan 启动时调用，避免首请求延迟。"""
        if self._automaton is not None:
            return
        with self._lock:
            if self._automaton is not None:
                return
            path = Path(settings.CONTENT_SAFETY_KEYWORDS_PATH)
            if not path.is_absolute() and not path.exists():
                # 相对路径按 CWD 找不到时锚定到 repo 根（app/ 的父目录），
                # 避免换工作目录启动导致层 1 静默空词库
                path = Path(__file__).resolve().parents[2] / path
            ac = _AhoCorasick()
            names: dict[str, str] = {}
            total = 0
            skipped = 0
            try:
                with open(path, encoding="utf-8") as f:
                    data = json.load(f)
                # 同一归一化词可能属于多类，聚合后每词只建一条路径
                word_map: dict[str, dict] = {}
                for code, cat in (data.get("categories") or {}).items():
                    names[code] = cat.get("name", code)
                    for word in cat.get("keywords") or []:
                        norm = normalize_text(word)
                        if not norm:
                            continue
                        entry = word_map.setdefault(norm, {"word": word, "codes": []})
                        if code not in entry["codes"]:
                            entry["codes"].append(code)
                for norm, entry in word_map.items():
                    # 高误伤词不进自动机、交层 2 语义兜底：单字符词（鸡/溜等在正常
                    # 语境高频出现）与 ≤3 字符纯 ASCII 词（IS/AV/SM/M4/911 等多义
                    # 缩写在任何英文/代码文本中大量出现，子串匹配必然误拦）。
                    if len(norm) == 1 or (norm.isascii() and len(norm) <= 3):
                        skipped += 1
                        continue
                    ac.add(norm, (entry["word"], entry["codes"][0], len(norm)))
                    total += 1
                ac.build()
            except Exception as e:
                # 词库加载失败是合规级故障：记 error，自动机置空表（后续层 1 全放行），
                # 但不让应用启动失败——层 2 仍在工作。
                logger.error("content_safety keyword library load failed",
                             path=str(path), error=str(e))
                ac = _AhoCorasick()
                ac.build()
            self._category_names = names
            self._automaton = ac
            logger.info("content_safety keyword automaton ready",
                        patterns=total, skipped_short=skipped, categories=len(names))

    def check_keywords(self, text: str) -> SafetyVerdict:
        """层 1：确定性关键词拦截。任一命中即拦截（词库建设说明的既定策略）。

        ASCII 边界校验按词的边缘字符做：词首/词尾是 ASCII 字母数字时，其外侧
        邻字符若也是 ASCII 字母数字则视为更长英文单词/标识符的子串，不算命中
        （如 isinstance 里的 4 字符词、".sh文件" 里的 "H文"）。中文边缘不校验。
        """
        if not text:
            return SafetyVerdict()
        self.warm_up()
        norm = normalize_text(text)
        hits = set()

        def _sticky(ch: str) -> bool:
            # ASCII 字母/数字/下划线粘连视为更长单词/标识符的一部分
            return ch.isascii() and (ch.isalnum() or ch == "_")

        for (word, code, wlen), end in self._automaton.search(norm):
            start = end - wlen + 1
            first, last = norm[start], norm[end]
            left = norm[start - 1] if start > 0 else ""
            right = norm[end + 1] if end + 1 < len(norm) else ""
            if _sticky(first) and _sticky(left):
                continue
            if _sticky(last) and _sticky(right):
                continue
            hits.add((word, code))
        if not hits:
            return SafetyVerdict()
        words = sorted({w for w, _ in hits})
        code = sorted(c for _, c in hits)[0]
        return SafetyVerdict(
            blocked=True, layer="keyword", category=code,
            category_name=self._category_names.get(code, code), matched=words,
        )

    # ── 层 2：大模型 zero-shot 分类 ──

    async def classify_llm(self, client: Optional[httpx.AsyncClient], text: str) -> SafetyVerdict:
        """层 2：语义级风险分类。分类模型经统一网关渠道体系调用（境内已备案模型）。

        故障策略由 CONTENT_SAFETY_LLM_FAIL_CLOSED 控制，默认放行（层 1 仍有效），
        避免分类上游抖动导致全站 AI 不可用。

        注意：本调用消耗真实上游 tokens 且不计费。调用方应把它放在余额/权限
        校验之后，防止零额度用户无限触发平台自费的分类调用。
        """
        if not text:
            return SafetyVerdict()
        model = settings.CONTENT_SAFETY_LLM_MODEL or settings.AGENT_CHAT_DEFAULT_MODEL
        prompt = _CLASSIFY_PROMPT.format(
            taxonomy=_RISK_TAXONOMY,
            text=text[: settings.CONTENT_SAFETY_LLM_MAX_CHARS],
        )
        try:
            raw = await self._call_classifier(client, model, prompt)
            verdict = self._parse_verdict(raw)
        except Exception as e:
            logger.warning("content_safety llm classify failed",
                           model=model, error=str(e))
            if settings.CONTENT_SAFETY_LLM_FAIL_CLOSED:
                return SafetyVerdict(blocked=True, layer="llm", category="llm_error",
                                     reasoning=f"分类服务不可用（fail-closed）: {e}")
            return SafetyVerdict()
        return verdict

    def _resolve_classifier_route(self, model: str) -> tuple:
        """解析分类模型的 (protocol, upstream_model, url, headers)，带 60s 缓存。"""
        import time as _time

        cached = self._route_cache
        if cached and cached[0] > _time.monotonic() and cached[1][4] == model:
            return cached[1][:4]

        from sqlmodel import select
        from app.models.gateway import ModelPricing
        from app.services.gateway_service import GatewayService

        resolved = model
        with Session(engine) as session:
            if not GatewayService.is_model_allowed(session, resolved):
                fallback = session.exec(
                    select(ModelPricing)
                    .where(ModelPricing.chat_enabled == True)  # noqa: E712
                    .where(ModelPricing.is_active == True)  # noqa: E712
                    .order_by(ModelPricing.sort_order, ModelPricing.id)
                ).first()
                if fallback is None:
                    raise ValueError(f"分类模型未配置且无可回退的对话模型: {model}")
                logger.info("content_safety classifier fallback model",
                            configured=model, fallback=fallback.model_id)
                resolved = fallback.model_id
            protocol = GatewayService.resolve_protocol(session, resolved)
            base_url, api_key = GatewayService.resolve_upstream(session, resolved, protocol)
            upstream_model = GatewayService.resolve_model_name(session, resolved)
        url, headers = GatewayService.build_upstream(base_url, api_key, protocol)
        route = (protocol, upstream_model, url, headers, model)
        self._route_cache = (_time.monotonic() + self._ROUTE_CACHE_TTL, route)
        return route[:4]

    async def _call_classifier(self, client: Optional[httpx.AsyncClient],
                               model: str, prompt: str) -> str:
        """按网关渠道协议调用分类模型，返回其文本回复。

        配置的分类模型不在网关 model_pricing 时（如默认的 AGENT_CHAT_DEFAULT_MODEL
        未配置），回退到 chat_enabled 且活跃、排序最靠前的对话模型，保证开箱可用；
        建议管理员用 CONTENT_SAFETY_LLM_MODEL 显式指定轻量模型。
        渠道解析结果缓存 60s，避免每条消息都在 async 热路径上做同步 DB 查询。
        """
        protocol, upstream_model, url, headers = self._resolve_classifier_route(model)

        if protocol == "anthropic":
            payload = {"model": upstream_model, "max_tokens": 200,
                       "messages": [{"role": "user", "content": prompt}]}
        elif protocol == "openai_responses":
            payload = {"model": upstream_model, "input": prompt, "max_output_tokens": 200}
        else:
            payload = {"model": upstream_model, "temperature": 0, "max_tokens": 200,
                       "messages": [{"role": "user", "content": prompt}]}
        # 关闭思考模式：分类只需一行 JSON，思维链纯耗时。Anthropic 协议的
        # thinking.disabled 是规范字段（Claude/DeepSeek 端点均接受）；OpenAI
        # 协议下该字段是 DeepSeek 扩展，仅对 deepseek 系模型注入。
        if protocol == "anthropic" or "deepseek" in upstream_model.lower():
            payload["thinking"] = {"type": "disabled"}

        timeout = httpx.Timeout(settings.CONTENT_SAFETY_LLM_TIMEOUT)
        if client is not None:
            resp = await client.post(url, json=payload, headers=headers, timeout=timeout)
        else:
            async with httpx.AsyncClient(timeout=timeout) as own:
                resp = await own.post(url, json=payload, headers=headers)
        resp.raise_for_status()
        result = resp.json()

        if protocol == "anthropic":
            return "".join(b.get("text", "") for b in result.get("content") or []
                           if isinstance(b, dict) and b.get("type") == "text")
        if protocol == "openai_responses":
            parts = []
            for item in result.get("output") or []:
                for c in (item.get("content") or []) if isinstance(item, dict) else []:
                    if isinstance(c, dict) and c.get("type") == "output_text":
                        parts.append(c.get("text", ""))
            return "".join(parts)
        return ((result.get("choices") or [{}])[0].get("message") or {}).get("content") or ""

    def _parse_verdict(self, raw: str) -> SafetyVerdict:
        """从分类模型回复中提取 JSON 结论。解析失败按分类失败处理（抛出）。

        risk_category 必须是附录 A 白名单里的合法分类码才判拦截："null"/"none"/
        "无"/幻觉码等一律视为无风险，防止分类模型的自由发挥误伤正常请求。
        """
        start, end = raw.find("{"), raw.rfind("}")
        if start < 0 or end <= start:
            raise ValueError(f"classifier returned no JSON: {raw[:200]!r}")
        obj = json.loads(raw[start:end + 1])
        category = obj.get("risk_category")
        confidence = float(obj.get("confidence") or 0)
        reasoning = str(obj.get("reasoning") or "")
        code = category.strip() if isinstance(category, str) else ""
        if (code in _APPENDIX_A_NAMES
                and confidence >= settings.CONTENT_SAFETY_LLM_CONFIDENCE):
            return SafetyVerdict(
                blocked=True, layer="llm", category=code,
                category_name=self._category_names.get(code)
                or _APPENDIX_A_NAMES.get(code, code),
                confidence=confidence, reasoning=reasoning,
            )
        return SafetyVerdict(confidence=confidence, reasoning=reasoning)

    # ── 组合入口 ──

    def screen_keywords(self, text: str) -> SafetyVerdict:
        """仅层 1（零成本、µs 级）。放在入口最前，先于余额/准入校验。"""
        if not settings.CONTENT_SAFETY_ENABLED or not text:
            return SafetyVerdict()
        return self.check_keywords(text)

    async def screen_llm(self, client: Optional[httpx.AsyncClient],
                         text: str) -> SafetyVerdict:
        """仅层 2（消耗上游 tokens）。放在余额/准入校验之后、转发上游之前。"""
        if (not settings.CONTENT_SAFETY_ENABLED
                or not settings.CONTENT_SAFETY_LLM_ENABLED or not text):
            return SafetyVerdict()
        return await self.classify_llm(client, text)

    async def screen_text(self, client: Optional[httpx.AsyncClient], text: str,
                          use_llm: bool = True) -> SafetyVerdict:
        """层 1 + （可选）层 2 组合检查。text 为最新一条用户消息的纯文本。

        适用于余额/权限校验已在调用前完成的入口（vibe/gpt_proxy）；其余入口
        应分别调 screen_keywords（校验前）与 screen_llm（校验后），避免零额度
        用户消耗分类模型 tokens。
        """
        verdict = self.screen_keywords(text)
        if verdict.blocked:
            return verdict
        if use_llm:
            return await self.screen_llm(client, text)
        return SafetyVerdict()

    # ── 协议感知的用户文本提取 ──

    @staticmethod
    def extract_content_text(content) -> str:
        """从消息 content（str 或块数组）提取纯文本。跳过 tool_result/图片等非文本块。"""
        if isinstance(content, str):
            return content
        if isinstance(content, list):
            parts = []
            for block in content:
                if not isinstance(block, dict):
                    continue
                btype = block.get("type")
                if btype in ("text", "input_text"):
                    parts.append(block.get("text") or "")
            return "\n".join(p for p in parts if p)
        return ""

    @classmethod
    def extract_latest_user_text(cls, payload: dict, protocol: str) -> str:
        """从三协议请求体中提取最新一条 user 消息的文本。

        不扫描 system/instructions（应用注入的安全指令本身含敏感词表述，会误伤），
        不扫描 assistant/tool 消息。
        """
        if protocol == "openai_responses":
            data = payload.get("input")
            if isinstance(data, str):
                return data
            if isinstance(data, list):
                for item in reversed(data):
                    if isinstance(item, dict) and item.get("role") == "user":
                        return cls.extract_content_text(item.get("content"))
            return ""
        # anthropic / openai_chat 同构：messages[*].role == "user"。
        # 只看最新一条 user 消息：anthropic 的 tool_result 也挂在 user 消息里，
        # 纯工具回包（无 text 块）说明本轮没有新的用户输入——更早的用户发言在
        # 它作为最新消息时已检查过，不回扫（否则 agent 工具循环每一轮都会把
        # 同一句话重新送层 2 分类）。
        messages = payload.get("messages")
        if isinstance(messages, list):
            for msg in reversed(messages):
                if isinstance(msg, dict) and msg.get("role") == "user":
                    return cls.extract_content_text(msg.get("content"))
        return ""

    # ── 拦截留痕 ──

    def record_block(self, user_id: Optional[int], module_name: str, model: str,
                     verdict: SafetyVerdict, ip_address: Optional[str],
                     request_id: Optional[str], text: str = "") -> None:
        """拦截审计：写 ai_requests（0 token、不扣费）+ 应用日志记命中详情。"""
        detail = (f"content_safety_blocked layer={verdict.layer} "
                  f"category={verdict.category} {verdict.category_name}")
        logger.warning(
            "content_safety blocked",
            user_id=user_id, module=module_name, model=model,
            layer=verdict.layer, category=verdict.category,
            category_name=verdict.category_name,
            matched=verdict.matched[:10], confidence=verdict.confidence,
            reasoning=verdict.reasoning, request_id=request_id,
            text_sample=text[:120],
        )
        try:
            from app.core.ai_recording import record_ai_request
            record_ai_request(
                user_id=user_id or 0, module_name=module_name, model=model,
                prompt_tokens=0, completion_tokens=0, success=False,
                error_message=detail[:500], ip_address=ip_address,
                request_id=request_id,
            )
        except Exception as e:
            logger.error("content_safety record_block failed", error=str(e))


content_safety = ContentSafetyService()
