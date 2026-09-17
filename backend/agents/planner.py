"""Planner Agent（第 24 节 / 第 26 节）：根据用户 Topic 生成结构化的 Plan（步骤列表 + 依赖）。

第 26 节增强：生成 Plan 前先检索**长期记忆**（memory_collection），把与当前主题最相似的
历史报告结构（章节标题）作为 Few-shot 注入 user prompt，让计划更贴合已验证过的分析框架；
命中信息写入 state["memory_hits"]，随任务落库供前端"记忆命中"卡片展示。

内部调用 LLM，使用 Prompt 约束输出 JSON 数组；解析失败时降级为默认两步计划，
保证流程始终可运行。
"""
import asyncio
import json
import logging
import re
from typing import List, Dict

from llm.client import chat
from memory import long_term_memory

logger = logging.getLogger(__name__)

# 步骤数上下限
MIN_STEPS = 2
MAX_STEPS = 5

SYSTEM_PROMPT = """你是一个市场调研任务规划器。根据用户给定的研究主题，将任务拆解为 {min}-{max} 个有序执行步骤。

每个步骤必须是严格的 JSON 对象，格式如下：
{{"id": 1, "agent": "researcher", "task": "具体子任务描述", "depends_on": []}}

规则：
- agent 只能取 "researcher"（需要联网搜索数据的子任务）或 "writer"（撰写报告章节的子任务）
- depends_on 为该步骤依赖的步骤 id 列表，无依赖填 []
- 通常先安排 researcher 步骤收集数据，再安排 writer 步骤撰写
- 只输出一个 JSON 数组，不要输出任何其他文字，不要使用 Markdown 代码块
""".format(min=MIN_STEPS, max=MAX_STEPS)


def parse_plan(content: str) -> List[Dict]:
    """从 LLM 输出中解析 Plan 步骤列表。

    为什么需要"容错"？因为 LLM 的输出不可靠，常见三种情况：
    1. 用 ```json ... ``` 代码块包裹（最常见）
    2. 在 JSON 前后夹带解释文字（如"好的，以下是计划：..."）
    3. 步骤字段非法（agent 写错、task 为空）
    解析策略（由易到难逐级容错）：
    第一步：剥掉 Markdown 代码块包裹
    第二步：仍解析失败则截取第一个 [ 到最后一个 ] 再尝试
    第三步：过滤非法步骤（agent 不在白名单 / task 为空）
    最终：超出 MAX_STEPS 的步骤截断，防止 LLM 一次给太多
    """
    text = (content or "").strip()
    # 1) 去掉可能的 ```json ... ``` 包裹（正则 DOTALL 让 . 也能匹配换行）
    fence = re.search(r"```(?:json)?\s*(.*?)\s*```", text, re.DOTALL)
    if fence:
        text = fence.group(1).strip()
    try:
        data = json.loads(text)          # 场景A：直接就是合法 JSON
    except json.JSONDecodeError:
        # 场景B/C：截取 [ 到 ] 的区间（剥掉前后废话）
        start, end = text.find("["), text.rfind("]")
        if start == -1 or end == -1:
            return []                    # 连 [ ] 都没有，说明 LLM 完全跑题
        try:
            data = json.loads(text[start : end + 1])
        except json.JSONDecodeError:
            return []                    # 区间内也不是合法 JSON，放弃
    if not isinstance(data, list):
        return []                        # 解析出非列表（如 dict），同样放弃
    # 2) 过滤非法步骤：只保留字段合法的 researcher/writer 步骤
    steps: List[Dict] = []
    for item in data:
        if not isinstance(item, dict):
            continue                     # 跳过非字典元素
        step = {
            "id": int(item.get("id", len(steps) + 1)),          # 缺 id 时自动编号
            "agent": item.get("agent", "researcher"),            # 缺 agent 默认 researcher
            "task": str(item.get("task", "")).strip(),           # task 必须非空
            "depends_on": item.get("depends_on", []) or [],      # 依赖列表缺省为空
        }
        # 白名单校验：agent 只能是 researcher / writer，且 task 不能为空
        if step["agent"] not in ("researcher", "writer") or not step["task"]:
            continue                     # 非法步骤直接丢弃
        steps.append(step)
    # 3) 截断超长计划，防止一次安排太多步骤
    return steps[:MAX_STEPS]


def fallback_plan(topic: str) -> List[Dict]:
    """降级计划：LLM 挂了/解析失败时的"兜底方案"。

    教学要点：外部依赖（LLM）不可用时，整个流程不能死掉。
    这里给出一个固定三步计划（市场规模 → 竞品 → 撰写），
    保证任务永远能往下跑 —— 这是工程上"降级设计"的典型例子。

    依赖关系：
      step1（搜规模）无依赖
      step2（搜竞品）依赖 step1
      step3（写报告）依赖 step1、step2  —— 数据齐了才能写
    """
    return [
        {"id": 1, "agent": "researcher", "task": f"搜索 {topic} 的市场规模与整体概况", "depends_on": []},
        {"id": 2, "agent": "researcher", "task": f"搜索 {topic} 的主要竞品与头部玩家", "depends_on": [1]},
        {"id": 3, "agent": "writer", "task": f"撰写《{topic}》市场调研报告草稿", "depends_on": [1, 2]},
    ]


def _build_few_shot(hit: Dict) -> str:
    """把 1 条历史报告命中构造成 Few-shot 参考文本（章节结构优先）。

    :param hit: recall 返回的 {"topic", "structure", "snippet", "score", ...}
    :return: 注入 user prompt 的参考段落；无有效结构时返回空串
    """
    structure = hit.get("structure") or []
    if not structure:
        return ""
    lines = "\n".join(f"- {h}" for h in structure[:10])
    return (
        "\n\n【长期记忆参考】以下是一次已完成的历史相似报告的结构，"
        "请参考其章节组织方式安排本次计划的 researcher/writer 步骤：\n"
        f"历史主题：{hit.get('topic', '')}\n{lines}"
    )


async def _recall_memory(topic: str) -> List[Dict]:
    """长期记忆检索（线程池包装同步 ChromaDB 调用，便于测试 patch 隔离）。"""
    try:
        return await asyncio.to_thread(long_term_memory.recall, topic)
    except Exception as exc:                      # 记忆子系统异常不阻断规划
        logger.warning("Planner 检索长期记忆失败：%s", exc)
        return []


async def planner_node(state: dict) -> dict:
    """LangGraph 节点：输入 topic → 输出 plan。

    节点约定：入参是完整 state，返回值是**增量 dict**（只含要更新的字段），
    LangGraph 会自动把增量合并回共享状态。

    执行步骤：
    1. 从 state 取研究主题 topic
    2. （第 26 节）检索长期记忆：最相似历史报告 → Few-shot + 记录 memory_hits
    3. 用 SYSTEM_PROMPT + topic（+ Few-shot）组装消息，调用 LLM 生成计划文本
    4. LLM 调用失败 → 记录日志 + 走降级计划
    5. 解析 LLM 输出；解析不出有效计划 → 走降级计划
    6. 在日志最前面插入 Thought（"已生成执行计划"/"检索到历史报告"）
    """
    topic = state["topic"]                       # 从白板读主题
    logs = list(state.get("react_logs", []))     # 拷贝现有日志（避免污染原 state）
    memory_hits = list(state.get("memory_hits", []))  # 已累计的记忆命中（续跑时不重复）

    # ---------- 第 26 节：Planner 先检索长期记忆（相似历史报告作 Few-shot）----------
    few_shot = ""
    hits = await _recall_memory(topic)
    if hits:
        top = hits[0]                             # 取最相似 1 条作 Few-shot
        if not any(m.get("task_id") == top.get("task_id") for m in memory_hits):
            memory_hits.append({
                "topic": top.get("topic", ""),
                "score": top.get("score", 0),
                "task_id": top.get("task_id", ""),
                "created_at": top.get("created_at", ""),
            })
        few_shot = _build_few_shot(top)
        hit_log = f"检索到历史报告：{top.get('topic', '')}，结构类似，已作为 Few-shot 参考"
        logger.info("Planner %s", hit_log)
        logs.append({"type": "Thought", "content": hit_log, "step_id": 0})

    messages = [
        {"role": "system", "content": SYSTEM_PROMPT},
        {"role": "user", "content": f"研究主题：{topic}{few_shot}"},
    ]
    try:
        resp = await chat(messages)              # 调 LLM 生成计划
        content = resp.choices[0].message.content or ""
    except Exception as exc:
        # LLM 不可用：记录一条 Observation，走降级计划
        content = ""
        logs.append(
            {"type": "Observation", "content": f"Planner 调用 LLM 失败：{exc}，使用降级计划", "step_id": 0}
        )
    # 解析 LLM 输出；空/非法 → 降级计划（容错链路的最后一道保险）
    plan = parse_plan(content) or fallback_plan(topic)
    # 把"计划已生成"作为第一条日志，step_id=0 归入规划阶段
    logs.insert(
        0,
        {
            "type": "Thought",
            "content": f"已生成执行计划：{len(plan)} 个步骤（{', '.join(s['agent'] for s in plan)}）",
            "step_id": 0,
        },
    )
    # 返回增量：plan（供 Scheduler 派发）+ 进度 + 日志 + 记忆命中（第 26 节）
    return {"plan": plan, "current_step_index": 0, "react_logs": logs, "memory_hits": memory_hits}
