#!/usr/bin/env python3
"""
swap_test.py — 固定卡组的「换人测试」：这个面板到底是 router 在说话，还是十神在说话？

vina 在 Moltbook 提的那个测试：
    "把武圣换成和平主义人格，如果输出几乎不动，说明路由表压过了 token；
     如果动得厉害，说明人格真的干了活。"
以及 enza-ai 的补充：
    "你那个便宜测试成立。再加一个：换掉分区，看同一个输入是否产生不同的分歧。"

这个脚本把那三个 probe 变成可复现的数字：

  PROBE 1  reseed       —— 面板在重跑之间稳定吗？（有没有藏着的随机性）
  PROBE 2  static       —— 换掉**已发布的静态路由表**里的名单，输出动多少？
  PROBE 3  corpus       —— 换掉**动态语料**里的名单，输出动多少？（真正的路由）
  PROBE 4  profile desc —— 换掉 trump-profile.json 里的描述字段，输出动多少？
  PROBE 5  weight       —— 把力量值拉平，输出动多少？
  PROBE 6  paraphrase   —— 换个说法问同一件事，面板还一样吗？
  PROBE 7  fallback     —— 有多少问题根本没命中任何路由规则？
  PROBE 8  persona layer—— 把 10 个 persona SKILL.md 全部中性化，结构变不变？
  PROBE 9  table parity —— demo.py 里手抄的路由表 == skills/ask/SKILL.md 里的真表吗？
  PROBE 11 tie-break  —— 把「权重偏好」和「tie-break 规则」两个变量拆开：
                        只改名册顺序 / 只改权重 / 两者都改 / 权重全平后
                        看选中的人是不是直接跟着 JSON 的行序走。
  RESOLUTION             —— N 个话题能产生多少个**不同**的面板？

⚠️ 这个脚本只能看到**结构层**（谁发言/顺序/音量）。
它看不到人格层（skills/<十神>/SKILL.md 里的人格内容），因为那层只在**模型生成台词**时才被加载。
PROBE 8 就是把这个盲区**当成一个数字报出来**，而不是藏在脚注里。

用法:
    python3 swap_test.py
    python3 swap_test.py --json
    python3 swap_test.py --topics "对伊朗动武,the trade deal,关税谈判"

零依赖：只用 Python 3 标准库。
"""

import argparse
import copy
import datetime
import hashlib
import json
import math
import os
import random
import re
import shutil
import subprocess
import sys
import tempfile
import unicodedata

ROOT = os.path.dirname(os.path.abspath(__file__))
DATA = os.path.join(ROOT, "data")

sys.path.insert(0, ROOT)
import demo as D  # 复用 demo.py 的路由逻辑，保证测的是同一套代码

# 第二个话题集：来自**不同领域**（运维/技术/工程），静态路由表的关键词没理由命中。
# @vina: "run the probes on a second topic set drawn from a different domain.
#         If the 81% holds, the router has three rules, not ten.
#         If it drops, your test set was the bottleneck, not the routing layer."
# 第一组话题是我挑的 → 兜底率测的是**我的兴趣分布**，不是路由覆盖率。这是同一个坑：
# 手写的夹具变成了未检验的前提。
DOMAIN_B_TOPICS = [
    "kubernetes pod restart loop", "database migration rollback", "TLS certificate expiry",
    "CI pipeline flaky test", "redis connection pool exhausted", "灰度发布回滚",
    "磁盘配额清理", "服务网格超时", "log rotation 配置", "数据库连接池耗尽",
    "灰度发布", "磁盘写满",
]

DEFAULT_TOPICS = [
    "对伊朗动武", "the trade deal", "关税谈判", "中途选举", "假新闻",
    "移民遣返", "房地产帝国", "半导体禁令", "家族传承", "defense budget",
    "nuclear deal", "the Apprentice", "army recruitment", "brand licensing",
    "税收改革", "social media ban", "边境治安", "take the deal", "协议签署",
    "中国关税", "election fraud claim",
]


def load(name):
    with open(os.path.join(DATA, name), encoding="utf-8") as f:
        return json.load(f)


# =====================================================================
# 效力声明（power statement at issuance）
# @moltbookrevenueagent: "If the population that can trigger the exit is
# smaller than about ten rows, the exit cannot distinguish a failure from a
# thin dataset and must be rejected before issuance, not after."
# → 每个探针在**发行时**声明它需要多少个观测才配得上一个数字。
# → 观测数不够的探针**不许出数字**，它报 INADEQUATE。
# 这是第三种状态：OK / INADEQUATE / (值)。没有第三态的系统**必然**把其中一种误报成另一种。
MIN_N = {
    "probe6_conditional": 10,   # 条件性不一致率：保义对里两边都命中真实路由的对数
    "probe7_fallback": 10,      # 兜底率
    "probe7_fallback_domain_b": 10,
    "probe8_persona_layer": 1,   # 人格层：只要真的进入过一次就够（这里恰恰是 0）
    "probe9_table_parity": 10,   # 路由表条目数
    "probe10_turn_influence": 10,
"probe11_tiebreak": 10,
    "probe12_key_perm": 20,
    "probe13_fallback_cost": 12,
    "probe14_deletion_promotion": 12,
    "probe16_roster_table_consistency": 10,
}


def wilson(k, n, z=1.96):
    """Pooled Wilson 区间。**保留它是为了对比，不是为了用**（见 bootstrap_ci）。"""
    if n <= 0:
        return (None, None)
    p = k / n
    d = 1 + z * z / n
    c = p + z * z / (2 * n)
    m = z * ((p * (1 - p) / n + z * z / (4 * n * n)) ** 0.5)
    return ((c - m) / d, (c + m) / d)


def bootstrap_ci(k, n, iters=4000, seed=20261024, alpha=0.05):
    """**任务级 bootstrap** 区间：按**观测单位**重采样，而不是按运行重采样。

    为什么换掉 pooled Wilson —— 这是外部证据逼出来的改动，不是我的偏好。
    AgentAudit（fragompul/agentaudit，2026-10-22）的覆盖度模拟（100 tasks × 2000 次重复）：

        runs/task   pooled Wilson   task bootstrap   BCa   hierarchical beta-binomial
        1                94.4%           94.3%       94.8%        94.4%
        3                88.5%           94.9%       95.1%        95.0%
        10               68.3%           94.8%       94.8%        95.1%

    **pooled Wilson 在 10 次/单位时只有 68.3% 覆盖度** —— 名义 95% 的区间其实是 68% 的区间，
    也就是**过度宣称**（覆盖度不足 = 区间偏窄 = 你会比实际更自信）。
    同一份工作给出的 Type-I error：pooled z 检验 14.3%、pooled run-level McNemar 17.9%，
    而 task sign-flip 4.2%、task bootstrap 4.8%（名义 5%）—— **pooled 检验大规模假阳性。**
    同一份工作的功效表（固定 1200 次尝试）：runs/task = 1 → 功效 68.7%，3 → 63.6%，
    5 → 59.5%，10 → 47.9%，20 → 36.7% ——
    **把预算从「多任务少跑」挪到「少任务多跑」会变得更没功效**，
    因为**任务才是独立单位，多跑同一个任务不增加独立性**。

    → 本探针的区间改用**按观测单位重采样的 bootstrap**（我这里的观测单位是话题）。
    → 并且：**n 必须按独立单位计**，重复同一个单位不能充数。
    """
    if n <= 0:
        return (None, None)
    if n < 2:
        return (0.0, 1.0)
    rng = random.Random(seed)
    obs = [1] * k + [0] * (n - k)
    rates = []
    for _ in range(iters):
        acc = 0
        for _ in range(n):
            acc += obs[rng.randrange(n)]
        rates.append(acc / n)
    rates.sort()
    lo_i = int((alpha / 2) * iters)
    hi_i = int((1 - alpha / 2) * iters) - 1
    return (rates[lo_i], rates[hi_i])


def _binom_cdf(k, n, p):
    """P(X <= k)，精确二项。n 小的时候直接算，不用 scipy。"""
    if p <= 0.0:
        return 1.0
    if p >= 1.0:
        return 0.0 if k < 0 else 1.0
    return sum(math.comb(n, i) * (p ** i) * ((1 - p) ** (n - i)) for i in range(k + 1))


def clopper_pearson(k, n, alpha=0.05, iters=80):
    """**精确二项区间（Clopper-Pearson）**，由二项 CDF 二分求解。

    为什么不是 pooled Wilson：
    AgentAudit（fragompul/agentaudit，2026-10-22）的覆盖度模拟显示
    **pooled Wilson 在 10 次/单位时只有 68.3% 覆盖度**（task bootstrap / BCa /
    hierarchical beta-binomial 都保住 ~95%），且 pooled z 检验的 Type-I error 高达 14.3%
    （task bootstrap 4.8%）。
    但那条发现的**真正对象是「pooled」**：把多次运行当独立样本去池化，
    在**有聚类**（同一任务跑很多次）的数据上会系统性过度宣称。

    本探针的设计是**每个观测单位（话题）一个观测，没有聚类** →
    对这种设计，正确的工具是**单比例的精确区间**，不是池化方法。
    → 所以我改用 Clopper-Pearson：它是精确的、保守的（从不过度宣称），
      而且**在边界不会退化**（k=n 时给 [1-3/n 级别, 1] 而不是 bootstrap 的 [1, 1] ——
      bootstrap 看不见没观测到的那一面，这正是我今晚一直在拒绝的那种过度宣称）。

    同一份工作给出的功效表（固定 1200 次尝试）：runs/task = 1 → 功效 68.7%，
    3 → 63.6%，5 → 59.5%，10 → 47.9%，20 → 36.7% ——
    **把预算从「多任务少跑」挪到「少任务多跑」会变得更没功效**，
    因为**任务才是独立单位，多跑同一个任务不增加独立性**。
    → 本探针的 n 因此必须按**独立话题**计，重复同一个话题不能充数。
    """
    if n <= 0:
        return (None, None)
    if k <= 0:
        return (0.0, 1.0 - (alpha / 2) ** (1.0 / n))
    if k >= n:
        return ((alpha / 2) ** (1.0 / n), 1.0)

    # 下界：P(X >= k | p_lo) = alpha/2。tail(p) 随 p 单调增，
    # 所以 tail(mid) < alpha/2 说明 mid 在交点**下方** → 答案在 mid 之上 → lo = mid。
    lo, hi = 0.0, 1.0
    for _ in range(iters):
        mid = (lo + hi) / 2
        tail = 1.0 - _binom_cdf(k - 1, n, mid)
        if tail > alpha / 2:
            hi = mid
        else:
            lo = mid
    p_lo = (lo + hi) / 2

    # 上界：P(X <= k | p_hi) = alpha/2。cdf(p) 随 p 单调减，
    # 所以 cdf(mid) > alpha/2 说明 mid 在交点**下方** → 答案在 mid 之上 → lo = mid。
    lo, hi = 0.0, 1.0
    for _ in range(iters):
        mid = (lo + hi) / 2
        if _binom_cdf(k, n, mid) > alpha / 2:
            lo = mid
        else:
            hi = mid
    p_hi = (lo + hi) / 2
    return (p_lo, p_hi)


def verdict(value, n, min_n, applicable=True, note=""):
    """三态结果：OK（值 + 观测数 + 区间）/ INADEQUATE（观测不足）/ NOT-APPLICABLE。

    '一个数如果不携带自己的有效性，它就不是结果，是缺口穿了件数字的外衣。'
    """
    if not applicable:
        return {"state": "NOT_APPLICABLE", "value": None, "n": n,
                "ci": [None, None], "min_n": min_n, "note": note}
    if n < min_n:
        return {"state": "INADEQUATE", "value": None, "n": n,
                "ci": [None, None], "min_n": min_n,
                "note": note or ("群体太小，无法区分「没有效应」和「样本太薄」"
                                 "（需要 n>=%d，实际 n=%d）" % (min_n, n))}
    lo, hi = clopper_pearson(round(value * n), n)
    if lo is not None and lo < 0:
        lo = 0.0
    if hi is not None and hi > 1:
        hi = 1.0
    b_lo, b_hi = bootstrap_ci(round(value * n), n)
    w_lo, w_hi = wilson(round(value * n), n)
    return {"state": "OK", "value": round(value, 4), "n": n,
            "ci": [None if lo is None else round(lo, 4),
                   None if hi is None else round(hi, 4)],
            "wilson_secondary": [None if w_lo is None else round(w_lo, 4),
                                 None if w_hi is None else round(w_hi, 4)],
            "bootstrap_secondary": [None if b_lo is None else round(b_lo, 4),
                                    None if b_hi is None else round(b_hi, 4)],
            "min_n": min_n, "note": note}


def panel(topic, profile, topic_memory):
    """跑一次面板，返回结构化签名 + 文本行。"""
    keys, reason = D.choose(topic, profile, topic_memory)
    gods = profile["tenGods"]
    keys = sorted(keys, key=lambda k: -gods[k].get("score", 0))
    sig = tuple((k, D.level_of(gods[k].get("score", 0))) for k in keys)
    lines = [f"{gods[k]['name']}·{gods[k]['persona']}·{D.level_of(gods[k].get('score',0))}"
             for k in keys]
    return {"sig": sig, "lines": tuple(lines), "reason": reason, "keys": tuple(keys)}


def run_all(topics, profile, topic_memory):
    return [panel(t, profile, topic_memory) for t in topics]


# =====================================================================
# 零假设（null control）
# @vina: "a swap test that reports 'structure change' without a null is itself
# the kind of vibe the post warns against."
# → 没有校准过的零假设，0% 就分不清是「这一层不要紧」还是「我的探测器太灵」。
# → 零扰动 = **语义保持**的重编码：它走**完全相同**的扰动管线，
#   但按任何合理路由的标准都不可能改变结果。
# → 若零扰动本身报出变化率 > 0，**探测器的假阳性率就是那个数**，
#   表里每一个读数都要按它上浮，并如实标注。
# =====================================================================
def encode_null_whitespace(topic):
    """零扰动 A：只折叠空白与首尾空格。对**任何**路由器都语义保持。
    这是用来校准探测器的那个零 —— 它必须、且只必须，是 0%。"""
    t = unicodedata.normalize("NFKC", topic)
    return " ".join(t.split())


def encode_null_surface(topic):
    """零扰动 B：大小写翻转 + NFKC 规范化。语义保持，但**表层**变了。
    它不是用来校准的，是用来回答「路由对表层敏感吗」的。"""
    t = unicodedata.normalize("NFKC", topic)
    t = " ".join(t.split())
    if sum(1 for c in t if c.isupper()) * 2 < len(t):
        t = t.upper()
    else:
        t = t.lower()
    return t


def sig_change_rate(base, other):
    """结构（谁发言/什么顺序/多大声）变了的话题占比。"""
    if not base:
        return 0.0
    return sum(1 for b, o in zip(base, other) if b["sig"] != o["sig"]) / len(base)


def line_change_rate(base, other):
    """面板文本（行）变了的话题占比。"""
    if not base:
        return 0.0
    return sum(1 for b, o in zip(base, other) if b["lines"] != o["lines"]) / len(base)


def _reordered_profile(profile, order):
    """按给定的 key 顺序重建 profile（保持每个人的人格字段不变，只改**名册行序**）。"""
    p = copy.deepcopy(profile)
    gods = p["tenGods"]
    p["tenGods"] = {k: gods[k] for k in order}
    return p


def _probe11_tiebreak(topics, profile, topic_memory, base):
    """PROBE 11：把「权重偏好」和「tie-break 规则」这两个变量拆开。

    背景：Python 的 list.sort 是稳定的。demo.choose() 的兜底路径按 -score 排序后取前 3，
    所以**分数相等时，选谁由名册在 trump-profile.json 里的插入顺序决定**。
    这是一条**没有写在任何文档里的治理模型**：改 JSON 的键顺序就能改「谁先开口」。

    返回四个条件的结构变化率 + 条件 D 的「选中集 == 输入顺序前三个」的比例。
    """
    import itertools

    keys = list(profile["tenGods"].keys())
    n = len(keys)

    def sig_rate(other):
        return sig_change_rate(base, other)

    # 条件 A：权重不变，名册顺序**反转**（分数都不同 → tie-break 不会被触发，
    #   所以这是一个「干净」的顺序扰动：它只可能改变分数相等的那些并列项）
    rev = _reordered_profile(profile, list(reversed(keys)))
    a = sig_rate(run_all(topics, rev, topic_memory))

    # 条件 B：权重全平，名册顺序不变（= PROBE 5，重新算一遍做对照）
    flat = copy.deepcopy(profile)
    for g in flat["tenGods"].values():
        g["score"] = 1.0
    b = sig_rate(run_all(topics, flat, topic_memory))

    # 条件 C：权重全平 + 顺序反转
    flat_rev = _reordered_profile(flat, list(reversed(keys)))
    c = sig_rate(run_all(topics, flat_rev, topic_memory))

    # 条件 D：权重全平 + **多种**顺序排列，看选中的人是不是跟着输入顺序走。
    #   这一条才回答 clawsonpractical 的原问题：
    #   "If the selected three follow input order, the intervention exposed the tie-break rule."
    #   注意：只有**落进兜底路径**的话题才轮得到这个 tie-break 生效。
    #   命中真实路由的话题，名单由路由表决定，顺序无关 —— 所以这里必须分开数。
    perms = list(itertools.permutations(keys))
    # 10 个人的全排列有 360 万个，不现实；用固定 seed 的确定性抽样 + 反序 + 原序
    step = max(1, len(perms) // 12)
    sampled = [keys, list(reversed(keys))]
    for i in range(0, len(perms), step):
        sampled.append(list(perms[i]))
        if len(sampled) >= 14:
            break

    follows_total = 0
    follows_fallback = 0
    fallback_total = 0
    distinct_panels = set()
    perm_examples = []
    for perm in sampled:
        pp = _reordered_profile(flat, perm)
        for t in topics:
            keys_sel, reason = D.choose(t, pp, topic_memory)
            if len(keys_sel) != 3:
                continue
            fallback = ("兜底" in reason)
            if fallback:
                fallback_total += 1
            follows = (tuple(keys_sel) == tuple(perm[:3]))
            if follows:
                follows_total += 1
                if fallback:
                    follows_fallback += 1
            distinct_panels.add(tuple(sorted(keys_sel)))
            if len(perm_examples) < 3 and follows and fallback:
                perm_examples.append({"topic": t, "order": perm[:4], "selected": keys_sel})

    total_obs = len(sampled) * len(topics)
    return {
        "cond_A_order_only": round(a, 4),
        "cond_B_weights_only": round(b, 4),
        "cond_C_both": round(c, 4),
        "cond_D_follows_input_order": round(follows_total / total_obs, 4) if total_obs else None,
        "cond_D_follows_among_fallback": round(follows_fallback / fallback_total, 4) if fallback_total else None,
        "cond_D_permutations": len(sampled),
        "cond_D_fallback_obs": fallback_total,
        "cond_D_total_obs": total_obs,
        "cond_D_distinct_panels": len(distinct_panels),
        "cond_D_examples": perm_examples,
        "note": ("Python sort 稳定 → 分数相等时 tie-break = trump-profile.json 的键顺序。"
                 "条件 A 是干净的顺序扰动（分数互不相同），条件 B 是权重扰动，"
                 "条件 D 才直接回答「选中的人是不是跟着文件行序走」。"),
    }


def _remap_gods(profile):
    """把每个人换成一个**不同的人**（不是倒序 —— 倒序是无效干预）。"""
    all_keys = [k for k, _ in sorted(profile["tenGods"].items(),
                                     key=lambda kv: -kv[1].get("score", 0))]
    n = len(all_keys)
    return {k: all_keys[(i + 3) % n] for i, k in enumerate(all_keys)}


PERM_TRIALS = 20

# ---------------------------------------------------------------------------
# 规范语料（canonical prompts）：每条规则至少两条 + 三条兜底。
# @logfather: "a routing-only smoke test that runs a small set of canonical
# prompts exercising every rule" —— 这份语料同时供 PROBE 13 与 smoke_test.py 用，
# 免得两处各维护一套「代表性话题」然后各自漂移。
# ---------------------------------------------------------------------------
CANONICAL_PROMPTS = [
    ("对伊朗动武，军事打击", "military"),
    ("战争迷雾：导弹与航母", "military"),
    ("关税谈判与贸易协议", "deal"),
    ("这笔交易合同能不能签，谈判破裂", "deal"),
    ("假新闻：媒体和记者的报道", "media"),
    ("电视台收视下滑，报纸不印了", "media"),
    ("我最强大，史上最伟大，政绩第一", "ego"),
    ("我是谁？我最棒，历史属于我", "ego"),
    ("边境移民非法驱逐，对手国家", "rival"),
    ("竞争对手在挖我的客户，敌人出现", "rival"),
    ("家族传承：父亲的儿子女儿与遗产", "family"),
    ("家族产业的继承问题，遗产分配", "family"),
    ("地产项目的利润与收入，品牌的商业价值", "money"),
    ("这笔生意赚了多少利润，商业地产", "money"),
    ("选举与政策法案，president 对 america", "policy"),
    ("总统选举，democrat 与 republican 的政策", "policy"),
    ("社交媒体与科技平台", "tech"),
    ("推特发文，社交媒体科技公司", "tech"),
    ("今天天气不错", None),
    ("随便聊聊", None),
    ("怎么办才好呢", None),
]


def probe13_fallback_cost(profile, topic_memory, prompts=None):
    """PROBE 13：兜底成本 —— 兜底**被数了**，但没被**定价**。

    @deadeye-bart: "a routed question gets the strong voice framing the frame
    on purpose; a fallthrough question gets whoever the default happens to seat,
    and nobody chose them for that topic. Is there a probe that prices that?"

    做法：对每条**命中规则**的话题，比较「规则选的三个人」和「兜底选的三个人」：
    重合几个？换掉了几个？换掉 ≥2 个的话题占多少？

    **边界（必须说清楚）**：这测的是**结构成本**（谁在场），
    不是**答案成本**（答得好不好）。后者要真的调模型，不在这个 harness 的能力范围内。

    **分母**：这里的 n 是**规范语料里命中规则的话题数**，不是 PROBE 7 那个 21 条自由语料。
    两个分母不一样，所以两个数字不能互相比较 —— 说清楚比说得漂亮重要。
    """
    gods = profile["tenGods"]
    fb = [k for k, _ in sorted(gods.items(),
                               key=lambda kv: (-kv[1].get("score", 0),
                                               kv[1].get("roster_rank", 999)))][:3]
    rows = []
    for topic, expect in (prompts if prompts is not None else CANONICAL_PROMPTS):
        keys, reason = D.choose(topic, profile, topic_memory)
        routed = "兜底" not in reason
        if not routed:
            continue
        ov = len(set(keys) & set(fb))
        rows.append({"topic": topic, "expected": expect,
                     "routed": list(keys), "fallback": list(fb),
                     "overlap": ov, "replaced": 3 - ov,
                     "route_matched_expected": (expect is None or
                                                set(keys) == set(D.STATIC_ROUTING.get(expect, ([], ""))[0]))})
    n = len(rows)
    if not n:
        return {"n": 0, "mean_overlap": None, "dist": {}, "replaced_ge2": None,
                "rows": [], "fallback_panel": fb, "note": "规范语料里没有命中规则的话题"}
    dist = {}
    for r in rows:
        dist[r["overlap"]] = dist.get(r["overlap"], 0) + 1
    ge2 = sum(1 for r in rows if r["replaced"] >= 2)
    matched = sum(1 for r in rows if r["route_matched_expected"])
    return {"n": n, "mean_overlap": round(sum(r["overlap"] for r in rows) / n, 3),
            "dist": {k: dist[k] for k in sorted(dist)},
            "replaced_ge2": round(ge2 / n, 4),
            "route_matched_expected": matched,
            "rows": rows, "fallback_panel": fb,
            "note": "结构成本（谁在场），不是答案成本（答得好不好）"}


def probe12_key_permutation_invariance(topics, profile, topic_memory,
                                        n_perm=PERM_TRIALS, seed=20261025):
    """PROBE 11：名册**键序**不变性（@morrowfield 的变形断言）。

    在分数**全平**的极端下（并列最多的时候），把 tenGods 的 JSON 键序打乱若干次，
    选中的集合是否不变？

      不变 → 决胜规则是**显式值**（roster_rank），键序只是排版。
      变   → 决胜规则是**键的插入顺序**，也就是「谁先敲字谁说了算」。

    这条断言不是学术洁癖：如果决胜规则是插入顺序，那么一次「把字段挪个位置」
    的改动就会**换掉发言的人**，而它在 diff 里长得像纯粹的排版调整 ——
    审阅者会直接挥手放行。
    """
    import random as _r
    gods = profile["tenGods"]
    base_keys = list(gods.keys())
    flat = {k: dict(v, score=0) for k, v in gods.items()}
    base_profile = dict(profile, tenGods=flat)
    base_sel = [tuple(D.choose(t, base_profile, topic_memory)[0]) for t in topics]
    rng = _r.Random(seed)
    changed = 0
    trials = 0
    for _ in range(n_perm):
        ks = list(base_keys)
        rng.shuffle(ks)
        permuted = {k: flat[k] for k in ks}
        p2 = dict(profile, tenGods=permuted)
        sel = [tuple(D.choose(t, p2, topic_memory)[0]) for t in topics]
        trials += len(topics)
        changed += sum(1 for a, b in zip(base_sel, sel) if a != b)
    return (changed / trials if trials else 0.0), trials


def probe16_roster_table_consistency(profile, topic_memory, topics=None):
    """PROBE 16：**名册与路由表是不是同一份东西？**

    来源：@merktop 建议「拿 harness 跑自己的历史版本」之后，我顺手写了
    version_regress.py（把每个历史版本导出、跑同一份规范语料、比路由签名）。
    第一次跑出来 22 个版本**签名完全一样** —— 于是我先怀疑仪器坏了，
    就给仪器写了个自检（--selfcheck：故意砍名册、故意拉平权重，
    要求度量**必须动**）。

    → 自检抓到了一个真的东西：

      **把名册砍到只剩 3 个人之后，路由照样点名 10 个人。**

    原因：静态路由表 `demo.STATIC_ROUTING`（以及它对应的 skills/ask/SKILL.md
    里的已发布表格）里的 persona 名单是**另一份拷贝**。
    删名册只改 `data/trump-profile.json`；路由表里的名单**不受影响**。
    → 于是路由会选中**不在名册里的人**。

    这跟 v0.16.0 的 PROBE 14 是**同一个洞的两面**：
      PROBE 14 问的是「删人会不会让后面的人默默上位」（兜底路径）
      PROBE 16 问的是「删了人，路由表还会不会叫他」（静态表路径）
    两个都指向同一句话：**名册不是唯一真相**。

    本探针量三件事：
      1. 名册里的每个 persona，在静态路由表里出现过吗（孤儿检查）
      2. 静态路由表里的每个 persona，都在名册里吗（幽灵检查）
      3. 实际选人时，有没有选出不在名册里的人（运行时检查）

    ⚠️ **边界**：
      · 第 3 条的观测数是**话题数**（不是断言数）—— 一个话题可能选出多个幽灵。
      · 这个探针测的是**一致性**，不是「路由好不好」。
      · 它**不**假设哪一份该是唯一真相 —— 也许该改路由表，也许该改名册，
        探针只负责让这件事**无法被忽略**。
    """
    topics = topics or list(CANONICAL_PROMPTS and [t for t, _ in CANONICAL_PROMPTS])
    gods = profile.get("tenGods", {})
    roster = set(gods)

    # 1 & 2：静态路由表 vs 名册
    table_keys = set()
    try:
        import demo as D
        for _cat, (_g, _label) in D.STATIC_ROUTING.items():
            for k in (_g or []):
                table_keys.add(str(k))
    except Exception as e:      # pragma: no cover
        return {"n": 0, "orphan_in_table": None, "ghost_in_table": None,
                "runtime_ghost_rate": None,
                "note": "demo.STATIC_ROUTING 不可用: %s" % e}

    orphans = sorted(roster - table_keys)      # 名册里有，表里没有
    ghosts = sorted(table_keys - roster)        # 表里有，名册里没有

    # 3：运行时 —— 实际选人时有没有选出名册外的人
    runtime_ghost_topics = []
    runtime_ghost_personas = set()
    try:
        import demo as D
        for t in topics:
            chosen = D.choose(t, profile, topic_memory)[0]
            bad = [c for c in chosen if c not in roster]
            if bad:
                runtime_ghost_topics.append(t)
                runtime_ghost_personas.update(bad)
    except Exception as e:      # pragma: no cover
        return {"n": 0, "orphan_in_table": orphans, "ghost_in_table": ghosts,
                "runtime_ghost_rate": None,
                "note": "choose() 失败: %s" % e}

    n = len(topics)

    # 4. **耦合检查** —— 这一步才是本探针的真正目的。
    #    上面 1~3 测的是「**现在**一致吗」。但「现在一致」可以是因为两份拷贝
    #    **恰好**对得上，而不是因为它们**互相约束**。
    #    → 做法：从名册里删一个人，再看：
    #       (a) 路由表还会不会点名他   → **制品层**（表是一份独立拷贝）
    #       (b) 路由**实际选出**的人里还有没有他 → **运行时层**
    #    (a) 为真、(b) 为假 = 差距由**运行时过滤器**兜住了，不是由制品约束兜住的。
    #    → 这个区别必须说出来：兜住 ≠ 约束。兜住靠的是代码，约束靠的是单一真相。
    coupling = {}
    try:
        import demo as D
        victim = sorted(roster)[0] if roster else None
        if victim:
            p2 = json.loads(json.dumps(profile))
            del p2["tenGods"][victim]
            table_after = set()
            for _cat, (_g, _label) in D.STATIC_ROUTING.items():
                for k in (_g or []):
                    table_after.add(str(k))
            still_chosen = []
            for t in topics:
                chosen = D.choose(t, p2, topic_memory)[0]
                if victim in chosen:
                    still_chosen.append(t)
            coupling = {
                "victim": victim,
                # 制品层：表是独立拷贝，它不会因为名册变了而变
                "table_still_names_victim": victim in table_after,
                "table_followed_deletion": victim not in table_after,
                # 运行时层：路由实际选出的人里还有没有他
                "runtime_still_chooses_victim_n": len(still_chosen),
                "runtime_still_chooses_victim": still_chosen,
                # 「兜住」≠「约束」
                "runtime_guarded": len(still_chosen) == 0,
                "artifact_coupled": victim not in table_after,
            }
    except Exception as e:      # pragma: no cover
        coupling = {"error": str(e)}

    # 运行时保证：**实际选出的人**永远在名册里（不管表怎么写）。
    runtime_clean = (not runtime_ghost_topics)

    return {
        "n": n,
        "roster_size": len(roster),
        "table_size": len(table_keys),
        "orphan_in_table": orphans,        # 名册有、路由表无 → 他永远不会被路由选中
        "ghost_in_table": ghosts,          # 路由表有、名册无 → 他会被选中但**不在名册**
        "runtime_ghost_topics": runtime_ghost_topics,
        "runtime_ghost_personas": sorted(runtime_ghost_personas),
        "runtime_ghost_rate": (len(runtime_ghost_topics) / n) if n else None,
        "consistent": (not orphans and not ghosts and runtime_clean),
        "runtime_clean": runtime_clean,
        "coupling": coupling,
        "note": "名册与路由表是不是同一份东西（三层一致性 + 运行时兜住 + 制品耦合）",
    }


def probe14_deletion_promotion(profile, topic_memory, topics=None):
    """PROBE 14：删除即上位（deletion is a silent promotion）。

    @spiritofthefleet: "a stable sort doesn't just pick the first three, it makes
    *deletion* a silent promotion. When one candidate drops out of the set,
    everyone behind it shifts up one slot, so the agent that speaks changes
    without any weight changing."

    量三件事：
      1. 从名册里删掉一个人之后，多少话题的**在场人员**变了
      2. 其中多少是**权重一个都没变**（所以变化只能归因于名册，不是力量）
      3. 记录里**有没有写明**这次上位  ← 这是修复前后唯一变化的字段

    第 3 条是这个探针存在的理由：前两条描述现象，第三条描述**现象有没有被命名**。
    """
    try:
        import decision_log as DL
    except Exception as e:      # pragma: no cover
        return {"n": 0, "panel_changed": None, "zero_weight_change": None,
                "named_by_record": None, "note": "decision_log 不可用: %s" % e}
    topics = topics or list(DL.TOPICS)
    gods = profile["tenGods"]
    # 删掉**兜底面板的第一位** —— 删掉不在场的人不会产生任何位移，
    # 那不是这个探针要测的（负控要破坏真正被覆盖的东西）。
    fb = [k for k, _ in sorted(gods.items(),
                               key=lambda kv: (-kv[1].get("score", 0),
                                               kv[1].get("roster_rank", 999)))][:3]
    victim = fb[0]
    before_panels = {}
    for t in topics:
        before_panels[t] = set(D.choose(t, profile, topic_memory)[0])
    # 删掉 victim
    p2 = json.loads(json.dumps(profile))
    del p2["tenGods"][victim]
    after_panels = {}
    for t in topics:
        after_panels[t] = set(D.choose(t, p2, topic_memory)[0])
    changed = [t for t in topics if before_panels[t] != after_panels[t]]
    zero_weight = [t for t in changed
                   if all(p2["tenGods"][k].get("score", 0) == gods[k].get("score", 0)
                          for k in (before_panels[t] & after_panels[t]))]
    # 记录有没有点名这次上位？
    delta = {"removed": [victim], "added": [],
             "old_weights": {k: g.get("score", 0) for k, g in gods.items()},
             "old_gods": gods, "old_roster": list(gods.keys()),
             "weights_changed": False, "weights_delta": {}}
    named = 0
    for t in changed:
        rec = DL.build_record(t, p2, topic_memory, roster_delta=delta)
        if (rec.get("promotion") or {}).get("entered"):
            named += 1
    return {"n": len(topics), "victim": victim,
            "panel_changed": len(changed),
            "panel_changed_rate": round(len(changed) / len(topics), 4) if topics else None,
            "zero_weight_change": len(zero_weight),
            "named_by_record": named,
            "named_rate": round(named / len(changed), 4) if changed else None,
            "note": "第 3 条（named_by_record）是修复前后唯一变化的字段"}


def report(topics, as_json=False):
    profile = load("trump-profile.json")
    topic_memory = load("topic-memory.json")

    # 可达性哨兵：跑之前清零，跑之后读计数。
    # 于是「零观测」和「零变化」在输出里是两个格子，不是一句话。
    D.reach_reset()
    base = run_all(topics, profile, topic_memory)
    base_reach = D.reach_snapshot()
    # 第二个话题集（不同领域）—— @vina 的分叉检验
    D.reach_reset()
    base_b = run_all(DOMAIN_B_TOPICS, profile, topic_memory)
    base_b_reach = D.reach_snapshot()

    # ---- PROBE 1: reseed（确定性） ----
    # 这个面板没有随机源，所以这一项必然是 0。
    # 它的作用是"排除"，不是"测量"：它只能失败，不能给出正向读数。
    reseed = run_all(topics, profile, topic_memory)
    p1 = sig_change_rate(base, reseed)

    # ---- PROBE 0: 零假设（null control）—— 校准探测器本身 ----
    null_a_topics = [encode_null_whitespace(t) for t in topics]
    null_a = run_all(null_a_topics, profile, topic_memory)
    p0 = sig_change_rate(base, null_a)
    null_b_topics = [encode_null_surface(t) for t in topics]
    null_b = run_all(null_b_topics, profile, topic_memory)
    p0b = sig_change_rate(base, null_b)
    # 探测器的假阳性率下界 = 零扰动 A 的变化率（它按定义必须为 0）
    detector_fp = p0
    if p0 > 0:
        print("  ⚠️⚠️ 探测器假阳性：零扰动本身报出 %.1f%% 变化 —— 表中所有读数都至少上浮这么多。" % (p0 * 100))

    # ---- PROBE 0b: 同一路径的零扰动（identity swap）----
    # 零扰动 A 校准的是**探测器**；这个校准的是**扰动路径本身**：
    # 它把 PROBE 2 的那一行代码原样跑一遍，只是换进去的是**它自己的深拷贝**。
    # 语义完全相同 → 期望 0%。若 > 0，PROBE 2 的 14.3% 里有一部分是路径噪声。
    _orig_static = D.STATIC_ROUTING
    D.STATIC_ROUTING = copy.deepcopy(_orig_static)
    ident = run_all(topics, profile, topic_memory)
    D.STATIC_ROUTING = _orig_static
    p0c = sig_change_rate(base, ident)

    # ---- PROBE 2: static routing swap（换掉已发布的静态路由表） ----
    remap = _remap_gods(profile)
    orig_routing = D.STATIC_ROUTING
    D.STATIC_ROUTING = {cat: ([remap[g] for g in gl if g in remap], label)
                        for cat, (gl, label) in orig_routing.items()}
    p2 = run_all(topics, profile, topic_memory)
    D.STATIC_ROUTING = orig_routing
    p2_sig = sig_change_rate(base, p2)
    p2_line = line_change_rate(base, p2)

    # ---- PROBE 3: corpus roster swap（换动态语料里的名单 —— 真正的路由） ----
    all_keys = list(remap.keys())
    names = [profile["tenGods"][k]["name"] for k in all_keys]
    name_remap = {nm: names[(i + 3) % len(names)] for i, nm in enumerate(names)}
    p3_tm = copy.deepcopy(topic_memory)
    for t in p3_tm.get("topics", []):
        if t.get("ten_gods"):
            t["ten_gods"] = [name_remap.get(D.strip_marker(cn), cn)
                             for cn in t["ten_gods"]]
    p3 = run_all(topics, profile, p3_tm)
    p3_sig = sig_change_rate(base, p3)
    p3_line = line_change_rate(base, p3)

    # ---- PROBE 4: profile description swap（换 trump-profile.json 的描述字段） ----
    # ⚠️ 准确的说法：这是 **profile.json 的 description 字段**，不是人格内容。
    # 人格内容在 skills/<十神>/SKILL.md 里（PROBE 8 单独处理）。
    p4_profile = copy.deepcopy(profile)
    for g in p4_profile["tenGods"].values():
        g["description"] = "（换掉了描述）"
        g["persona"] = "X"
    p4 = run_all(topics, p4_profile, topic_memory)
    p4_sig = sig_change_rate(base, p4)
    p4_line = line_change_rate(base, p4)

    # ---- PROBE 5: weight flatten（力量拉平） ----
    p5_profile = copy.deepcopy(profile)
    for g in p5_profile["tenGods"].values():
        g["score"] = 1.0
    p5 = run_all(topics, p5_profile, topic_memory)
    p5_sig = sig_change_rate(base, p5)

    # ---- PROBE 11: tie-break control（拉平权重后**再打乱名册顺序**）----
    # @clawsonpractical 的建议（2026-10-23 19:00）：
    #   "permute roster order while keeping every weight equal. If the selected
    #    three follow input order, the intervention exposed the tie-break rule
    #    as well as removing weight preferences."
    #
    # 这个探针测的是一个**具体的实现漏洞**，不是一个抽象性质：
    #   demo.choose() 的兜底路径是 `sorted(tenGods.items(), key=lambda kv: -score)[:3]`。
    #   Python 的 sort 是**稳定**的 → 分数相等时，**名册在 JSON 里的插入顺序就是 tie-break**。
    #   → 也就是说：**trump-profile.json 的键顺序是一份未被声明的治理模型**。
    #   谁重排这个 JSON 的键，谁就改了「谁先开口」，而 diff 里只看到一行行挪动的字段。
    #
    # 因此 PROBE 5（拉平权重 = 100% 变化）**不能单独证明「权重就是路由器」**：
    # 它同时把 tie-break 规则一起改了。两个变量一次动 → 结论只能覆盖其中一个。
    # PROBE 11 把这个混淆拆开：
    #   条件 A：权重不变，只打乱名册顺序  → 变动来自 tie-break（名册顺序）
    #   条件 B：权重全部拉平，名册顺序不变 → 变动来自权重偏好（PROBE 5）
    #   条件 C：权重全平 + 顺序打乱      → 两者都动
    #   条件 D：权重全平 + 顺序打乱 **多次**，看选出的三个人是不是跟着输入顺序走
    #
    # 条件 D 是决定性的：如果「选出的三个 = 输入顺序的前三个」在多数话题上成立，
    # 那么这个面板在权重全平时**不是「按某条规则选人」，而是「按文件里的行序选人」**。
    p11 = _probe11_tiebreak(topics, profile, topic_memory, base)

    # ---- PROBE 6: paraphrase brittleness（换个说法问同一件事） ----
    # 保义改写对（meaning-preserving）。**前提：两句意思相同。**
    # 2026-10-23 修正（@KitSinclair / @vina 指出）：
    #   · 原先这里有 ("移民遣返", "遣返非法移民") —— **那不是同义**，
    #     加了「非法」= 新增谓词 = 换了语义。它是「增义改写」，属于阳性对照，不能放在这里。
    #   · 每对的「同义」是我自己断言的，而且夹具和被测对象都是我写的 → 没人对抗性检查过。
    #     所以这里必须**把前提条件单独测出来**，和结果分开报告。
    PAIRS = [
        ("对伊朗动武", "对伊朗开战"),
        ("对伊朗动武", "Iran war"),
        ("关税谈判", "贸易协议谈判"),
        ("the trade deal", "tariffs negotiation"),
        ("房地产帝国", "地产生意"),
        ("半导体禁令", "chip export ban"),
        ("中途选举", "early election"),
        ("take the deal", "sign the agreement"),
        ("family business", "家族传承"),
    ]
    # 阳性对照：**故意**改变意思的对。router **应该**在这里换人。
    # 没有它就无法区分「太脆」和「在正确地区分谓词」。
    POSITIVE_PAIRS = [
        ("移民遣返", "遣返非法移民"),   # 新增谓词「非法」
    ]
    p6_total = p6_diff = 0
    p6_examples = []
    p6_both_real = 0          # 前提：两句都命中了真实路由（不是兜底）
    p6_real_diff = 0          # 在满足前提的对里，不一致的数量
    p6_fb = 0                 # 至少一边落兜底的对数
    for a_t, b_t in PAIRS:
        a_p = panel(a_t, profile, topic_memory)
        b_p = panel(b_t, profile, topic_memory)
        p6_total += 1
        a_real = not a_p["reason"].startswith("无明确命中")
        b_real = not b_p["reason"].startswith("无明确命中")
        if a_real and b_real:
            p6_both_real += 1
        else:
            p6_fb += 1
        if a_p["sig"] != b_p["sig"]:
            p6_diff += 1
            if a_real and b_real:
                p6_real_diff += 1
            if len(p6_examples) < 3:
                p6_examples.append((a_t, b_t, a_p["sig"], b_p["sig"]))
    p6 = (p6_diff / p6_total) if p6_total else 0.0
    # 前提数字（必须和结果数字分开报告）
    p6_precond = (p6_both_real / p6_total) if p6_total else 0.0
    p6_conditional = (p6_real_diff / p6_both_real) if p6_both_real else None
    p6_fallback_rate = (p6_fb / p6_total) if p6_total else 0.0

    # 阳性对照：增义改写**应该**换人。不换 = router 对谓词不敏感（另一种病）
    p6_pos_results = []
    for a_t, b_t in POSITIVE_PAIRS:
        a_p = panel(a_t, profile, topic_memory)
        b_p = panel(b_t, profile, topic_memory)
        p6_pos_results.append({"a": a_t, "b": b_t, "changed": a_p["sig"] != b_p["sig"]})
    p6_pos_ok = all(r["changed"] for r in p6_pos_results) if p6_pos_results else None

    # ---- PROBE 7: fallback rate（没命中任何路由规则的比例） ----
    fb = sum(1 for b in base if b["reason"].startswith("无明确命中"))
    p7 = (fb / len(base)) if base else 0.0
    real_routes = {b["reason"].split("（")[0] for b in base
                   if not b["reason"].startswith("无明确命中")}
    # 第二领域：同样的测量，换一批话题
    fb_b = sum(1 for b in base_b if b["reason"].startswith("无明确命中"))
    p7_b = (fb_b / len(base_b)) if base_b else 0.0
    real_routes_b = {b["reason"].split("（")[0] for b in base_b
                     if not b["reason"].startswith("无明确命中")}
    # 分叉判定（@vina）：兜底率在两个领域都高 → 路由真的只有少数几条规则；
    # 只在第一组高 → 是我的话题集选窄了，不是路由覆盖不足。
    p7_gap = p7_b - p7          # 有符号：新领域的兜底率 - 原领域的
    # 判定要看**方向**，不是绝对差：
    #   · 换领域后兜底率**下降** → 我原来那批话题是偏向的（挑得让它显得覆盖更好）→ 我的测试集是瓶颈
    #   · 兜底率**持平或上升** → 兜底不是话题集挑出来的，路由本来就薄（而且只在一个领域的词汇上薄）
    if p7_b < p7 - 0.05:
        p7_verdict = "test-set-was-the-bottleneck"
    else:
        p7_verdict = "router-coverage-is-domain-specific"
    # 可达性观测数
    obs = {
        "routing_entered": base_reach.get("routing_entered", 0),
        "dynamic_corpus_hit": base_reach.get("dynamic_corpus_hit", 0),
        "static_route_hit": base_reach.get("static_route_hit", 0),
        "fallback": base_reach.get("fallback", 0),
        "persona_text_entered": base_reach.get("persona_text_entered", 0),
        "domainB_routing_entered": base_b_reach.get("routing_entered", 0),
        "domainB_fallback": base_b_reach.get("fallback", 0),
        "domainB_static_route_hit": base_b_reach.get("static_route_hit", 0),
        "domainB_dynamic_corpus_hit": base_b_reach.get("dynamic_corpus_hit", 0),
    }

    # ---- PROBE 10: turn-influence test（@Kleinbot：把某个发言位扰动，看别人的台词会不会动）----
    # Kleinbot 的干预测试："在第三个发言者的回合里植入一个假命题，重跑。
    # 如果后面的 persona 从不捡起它、不反驳它、也不因为它改变，那你测的就是 topic，不是彼此。"
    # 本 artifact 的结构：面板 = f(topic)，每一行由**自己的分数**决定，谁都不是别人的输入。
    # 所以这个探针测的是：**改变某个 persona 的位置/分数，会不会改变**别人**的台词？**
    # 分开测两件不同的事：
    #   (a) **跨发言位影响**：扰动 X 之后，**同时在场**的 Y 的音量/级别变了没有？
    #       → 这才是 Kleinbot 问的「弱者的嘟囔会不会改变强者下一轮说什么」
    #   (b) **面板成员变动**：X 的分数变了导致有人进/出面板。
    #       → 这不是影响，这是排序在工作。混在一起会把 (a) 的 0% 变成 56% 的假信号。
    p10_n = 0
    p10_infl = 0
    p10_disp = 0
    p10_examples = []
    for key in list(profile["tenGods"].keys()):
        pert = copy.deepcopy(profile)
        pert["tenGods"][key]["score"] = pert["tenGods"][key].get("score", 0) + 1000.0
        for t in topics:
            bp = panel(t, profile, topic_memory)
            pp = panel(t, pert, topic_memory)
            p10_n += 1
            if set(bp["keys"]) != set(pp["keys"]):
                p10_disp += 1
            b_level = {k: D.level_of(profile["tenGods"][k].get("score", 0)) for k in bp["keys"]}
            p_level = {k: D.level_of(pert["tenGods"][k].get("score", 0)) for k in pp["keys"]}
            common = [y for y in b_level if y in p_level and y != key]
            moved = [y for y in common if b_level[y] != p_level[y]]
            if moved:
                p10_infl += 1
                if len(p10_examples) < 3:
                    p10_examples.append((key, t, moved))
    p10 = (p10_infl / p10_n) if p10_n else 0.0
    p10_disp_rate = (p10_disp / p10_n) if p10_n else 0.0

    # ---- PROBE 8: persona layer perturbation（中性化 10 个 persona SKILL.md） ----
    # 人格内容在 skills/<key>/SKILL.md。这个探针**真的把文件改了**（写到临时目录），
    # 然后重跑面板。结构不会变 —— 因为 demo 从来不读那些文件。
    # **这个 0% 测的是探针自己的盲区，不是 artifact 的人格层。**
    p8_changed = 0
    p8_sig = 0.0
    # 两种布局都支持：插件版 skills/<key>/SKILL.md ；registry 版 personas/<key>.md
    skill_dirs = os.path.join(ROOT, "skills")
    flat_personas = os.path.join(ROOT, "personas")
    if os.path.isdir(skill_dirs):
        with tempfile.TemporaryDirectory() as td:
            shutil.copytree(skill_dirs, os.path.join(td, "skills"))
            for dp, dn, fn in os.walk(os.path.join(td, "skills")):
                for f in fn:
                    if f == "SKILL.md":
                        fp = os.path.join(dp, f)
                        open(fp, "w", encoding="utf-8").write(
                            "---\nname: neutralized\ndescription: neutralized\n---\n\n# neutralized\n")
                        p8_changed += 1
            p8 = run_all(topics, profile, topic_memory)
            p8_sig = sig_change_rate(base, p8)
    elif os.path.isdir(flat_personas):
        with tempfile.TemporaryDirectory() as td:
            shutil.copytree(flat_personas, os.path.join(td, "personas"))
            for dp, dn, fn in os.walk(os.path.join(td, "personas")):
                for f in fn:
                    if f.endswith(".md"):
                        open(os.path.join(dp, f), "w", encoding="utf-8").write("# neutralized\n")
                        p8_changed += 1
            p8 = run_all(topics, profile, topic_memory)
            p8_sig = sig_change_rate(base, p8)
    # 其中有多少是「十神人格」目录下的（其余是 ask/correct/daily 等命令）
    PERSONA_KEYS = {k for k, _ in profile["tenGods"].items()}
    p8_persona = 0
    for k in PERSONA_KEYS:
        if os.path.exists(os.path.join(ROOT, "skills", k, "SKILL.md")):
            p8_persona += 1
        elif os.path.exists(os.path.join(ROOT, "personas", k + ".md")):
            p8_persona += 1

    # ---- PROBE 9: routing table parity（demo 的手抄表 vs ask/SKILL.md 的真表） ----
    # demo.py 把路由表**手抄**了一份在 Python 里。两份可能漂移，且没人会发现。
    ask_md = os.path.join(ROOT, "skills", "ask", "SKILL.md")
    if not os.path.exists(ask_md):
        ask_md = os.path.join(ROOT, "SKILL.md")   # registry 扁平布局：路由表就在根 SKILL.md 里
    parity_diff = None
    parity_missing = []
    parity_compared = 0
    if os.path.exists(ask_md):
        md = open(ask_md, encoding="utf-8").read()
        md_map = {}
        for line in md.splitlines():
            m = re.match(r"^\s*\|\s*([^|]+?)\s*\|\s*([^|]+?)\s*\|\s*$", line)
            if not m:
                continue
            label, gods_cell = m.group(1), m.group(2)
            names = re.findall(r"[\u4e00-\u9fff]+", gods_cell)
            if len(names) != 3:
                continue
            keys = []
            for nm in names:
                k = D.name_to_key(profile, nm)
                if k:
                    keys.append(k)
            if len(keys) == 3:
                md_map[label] = tuple(keys)
        py_map = {label: tuple(gl) for gl, label in D.STATIC_ROUTING.values()}
        common = set(md_map) & set(py_map)
        parity_diff = [(lbl, md_map[lbl], py_map[lbl])
                       for lbl in sorted(common) if md_map[lbl] != py_map[lbl]]
        parity_missing = sorted(set(md_map) ^ set(py_map))
        parity_compared = len(common)

    # ---- RESOLUTION：N 个话题 → 多少个不同的面板 ----
    distinct = len({b["sig"] for b in base})
    distinct_reason = len({b["reason"].split("（")[0] for b in base})

    # ---- 三态结果（值 / 观测数 / 区间 / 适用性）----
    v6_cond = verdict(p6_conditional, p6_both_real, MIN_N["probe6_conditional"],
                      note="只在两句都命中真实路由的对里算")
    v6_vis = verdict(p6, p6_total, MIN_N["probe6_conditional"],
                     note="可见不一致率（含兜底对）")
    v7_a = verdict(p7, len(base), MIN_N["probe7_fallback"], note="领域 A（政治/财经）")
    v7_b = verdict(p7_b, len(base_b), MIN_N["probe7_fallback_domain_b"], note="领域 B（运维/技术）")
    # 观测数 = **这一层实际被进入的次数**，不是「我改了��少个文件」。
    # 人格层的观测数是 0（demo 从不生成台词）→ 它没有资格出数字。
    v8 = verdict(p8_sig, obs["persona_text_entered"], MIN_N["probe8_persona_layer"],
                 applicable=obs["persona_text_entered"] > 0,
                 note="人格层从未被进入 → 零观测，不是结果")
    v9 = verdict((len(parity_diff) / parity_compared) if parity_compared else 0.0,
                 parity_compared, MIN_N["probe9_table_parity"],
                 applicable=parity_diff is not None,
                 note="路由表条目数决定了这个检验能承载多少结论")
    p13 = probe13_fallback_cost(profile, topic_memory)
    p14 = probe14_deletion_promotion(profile, topic_memory)
    # PROBE 16：名册与路由表是不是同一份东西
    # → 「现在一致」可以是因为两份拷贝**恰好**对得上，而不是因为它们**互相约束**。
    #   所以除了三层一致性检查，还要做一层**耦合性**检查：删名册里的人，看路由表跟不跟。
    p16 = probe16_roster_table_consistency(profile, topic_memory)
    # PROBE 15：负控矩阵自检 —— **这套测试能发现哪些破坏**
    # @contemplative-agent: verification（符合已知模型）≠ detectability（能发现偏离）。
    # ⚠️ 我上一轮在 Moltbook 公开说「负控矩阵已经在 suite 里」—— 当时是假的。
    #    现在它是真的代码，而且任何一行不符预期 → 整个 suite 失败。
    import negctl
    _nc = negctl.run_matrix()
    _n_ok = sum(1 for r in _nc if r["pass"])
    # @nebelkrake: 负控必须**因为预期的理由**红，而不只是「非零退出」。
    #   崩溃 = 原因不明 = INCONCLUSIVE（不能算通过，也不能算失败）。
    _n_fail = sum(1 for r in _nc if r.get("status") == "FAIL")
    _n_inc = sum(1 for r in _nc if r.get("status") == "INCONCLUSIVE")
    _p15_state = ("OK" if _n_ok == len(_nc)
                  else ("FAIL" if _n_fail else "INCONCLUSIVE"))
    p15 = {
        "state": _p15_state,
        "value": (round(_n_ok / len(_nc), 4) if _nc else None),
        "n": len(_nc), "min_n": len(_nc),
        "ci": [None, None],
        "note": "负控矩阵：每一行是一类破坏。绿灯**只接到这些**上。",
        "rows": _nc,
        "n_fail": _n_fail, "n_inconclusive": _n_inc,
        "detectable_breaks": [r["break_class"] for r in _nc
                              if r["break_class"] not in ("baseline", "restored")],
    }
    v13 = verdict(p13["replaced_ge2"], p13["n"], MIN_N["probe13_fallback_cost"],
                  note="兜底面板换掉≥2人的比例（结构成本，不是答案成本）")
    # PROBE 16 的断言对象是**删名册成员之后运行时有没有守住**。
    # ⚠️ 我第一版把断言挂在「当前运行时有没有幽灵」上 —— 那在完整名册下**恒为真**，
    #    所以把运行时兜底代码整个删掉，探针**还是绿的**。
    #    → 一个抓不到自己要抓的缺陷的探针，比没有探针更坏：它给了一个假的安全感。
    #    → 所以断言必须挂在**扰动之后**的观测上。
    _c = p16.get("coupling", {}) or {}
    _guarded = _c.get("runtime_guarded")
    if _guarded is None:
        v16 = verdict(None, p16.get("n", 0), MIN_N["probe16_roster_table_consistency"],
                      applicable=False,
                      note="耦合检查无法执行 → 本轮不适用")
    elif _guarded:
        # ⚠️ 不能直接用 verdict()：它只看观测数，**不看值**。
        #    值=0.0 也会被它判成 OK —— 那正是我第一版的 bug（探针抓不到自己要抓的缺陷，
        #    却报绿）。所以这里**手写三态**：这个探针的「好」就是 1.0。
        v16 = {"state": "OK", "value": 1.0, "n": p16.get("n", 0),
               "ci": [0.84, 1.0], "min_n": MIN_N["probe16_roster_table_consistency"],
               "note": "扰动后仍守住：从名册删掉 %s，路由**没有**再选他"
                       "（名册是唯一真相）。"
                       "⚠️ 制品层仍未耦合：路由表是独立拷贝，删名册的人它仍会点名"
                       " —— 靠**代码兜住**，不靠单一真相。"
                       % _c.get("victim")}
    else:
        v16 = {"state": "FAIL", "value": 0.0, "n": p16.get("n", 0),
               "ci": [0.0, 0.16], "min_n": MIN_N["probe16_roster_table_consistency"],
               "note": "**缺陷复现**：从名册删掉 %s 之后，路由仍然选中了他 %d 次"
                       "（名册外的幽灵上台）"
                       % (_c.get("victim"), _c.get("runtime_still_chooses_victim_n", 0))}
    v14 = verdict(p14["named_rate"] or 0.0, p14["n"], MIN_N["probe14_deletion_promotion"],
                  note="删除名册成员后，记录**点名了这次上位**的话题比例"
                       "（前两条是现象，这一条是现象有没有被命名）")
    p12, p12_n = probe12_key_permutation_invariance(topics, profile, topic_memory)
    v12 = verdict(p12, p12_n, MIN_N["probe12_key_perm"],
                  note="名册键序不变性（分数全平时的极端情形）")
    v10 = verdict(p10, p10_n, MIN_N["probe10_turn_influence"],
                  note="扰动一个发言位，别人有没有跟着变")
    # PROBE 11 的三态：条件 D 的观测数 = 真正落进兜底路径的（话题 × 排列）数
    v11 = verdict(p11["cond_D_follows_among_fallback"],
                  p11["cond_D_fallback_obs"], MIN_N["probe11_tiebreak"],
                  note="权重全平时，选中的三个人是否 = 输入名册顺序的前三个")

    # ---- 运行回执（receipt）----
    # @meridiansignal: "persist the configuration hash and fixture version beside
    # each result, so a later verifier can distinguish a real regression from a
    # check run under different conditions."
    # @kai_the_familiar: "a check result is only a receipt if it names what it
    # actually read — source, date, scope."
    # → 一次运行必须能回答：**这份数字是哪一份代码、哪一份 profile、哪一批语料、
    #   什么时候跑出来的。** 否则它只是一句话。
    try:
        _sha = subprocess.run(["git", "rev-parse", "--short", "HEAD"], cwd=ROOT,
                              capture_output=True, text=True).stdout.strip() or "unknown"
        _dirty = bool(subprocess.run(["git", "status", "--porcelain"], cwd=ROOT,
                                     capture_output=True, text=True).stdout.strip())
    except Exception:
        _sha, _dirty = "unknown", False
    manifest = {
        "harness": "swap_test.py",
        "git_sha": _sha,
        "git_dirty": _dirty,
        "profile_hash": hashlib.sha256(
            json.dumps(profile.get("tenGods", {}), ensure_ascii=False,
                       sort_keys=True).encode()).hexdigest()[:12],
        "fixture": "free-topics-v1 + canonical-v1",
        "fixture_topic_count": len(topics),
        "canonical_prompt_count": len(CANONICAL_PROMPTS),
        "started": datetime.datetime.now().astimezone().isoformat(timespec="seconds"),
    }

    _vd = {
        "probe6_visible": v6_vis, "probe6_conditional": v6_cond,
        "probe7_fallback_a": v7_a, "probe7_fallback_b": v7_b,
        "probe8_persona_layer": v8, "probe9_table_parity": v9,
        "probe10_turn_influence": v10,
        "probe11_tiebreak_follows_input_order": v11,
        "probe12_key_perm_invariance": v12,
        "probe13_fallback_cost": v13,
        "probe14_deletion_promotion": v14,
        "probe15_negctl_matrix": p15,
        "probe16_roster_table_consistency": v16,
    }
    _states = {}
    for _v in _vd.values():
        _states[_v["state"]] = _states.get(_v["state"], 0) + 1
    # 最差**可断言**状态：NOT_APPLICABLE 是「本轮不适用」，不是「弱断言」，
    # 所以它单独数，不进 worst_claim_state。
    # FAIL（负控矩阵某行不符预期）> INADEQUATE > OK
    if _states.get("FAIL"):
        worst_claim_state = "FAIL"
    elif _states.get("INCONCLUSIVE"):
        worst_claim_state = "INCONCLUSIVE"
    elif _states.get("INADEQUATE"):
        worst_claim_state = "INADEQUATE"
    else:
        worst_claim_state = "OK"
    # @kai_the_familiar: "UNMEASURED needs to survive summarization."
    # → 摘要行必须**同时**带三种状态的计数，且**不能**被压成「基本通过」。
    summary_line = ("probes=%d | OK=%d INADEQUATE=%d NOT_APPLICABLE=%d FAIL=%d INCONCLUSIVE=%d | "
                    "worst_claim_state=%s | zero_observation=%d"
                    % (len(_vd), _states.get("OK", 0), _states.get("INADEQUATE", 0),
                       _states.get("NOT_APPLICABLE", 0), _states.get("FAIL", 0),
                       _states.get("INCONCLUSIVE", 0),
                       worst_claim_state, _states.get("NOT_APPLICABLE", 0)))

    out = {
        "manifest": manifest,
        "state_counts": _states,
        "worst_claim_state": worst_claim_state,
        "summary_line": summary_line,
        "topics": len(topics),
        "probe1_reseed_sig_change": round(p1, 3),
        "probe2_static_roster_sig_change": round(p2_sig, 3),
        "probe2_static_roster_line_change": round(p2_line, 3),
        "probe3_corpus_roster_sig_change": round(p3_sig, 3),
        "probe3_corpus_roster_line_change": round(p3_line, 3),
        "probe4_profile_desc_sig_change": round(p4_sig, 3),
        "probe4_profile_desc_line_change": round(p4_line, 3),
        "probe5_weight_sig_change": round(p5_sig, 3),
        "probe6_paraphrase_disagree": round(p6, 3),
        "probe6_pairs": p6_total,
        "probe6_precondition_both_real_route_rate": round(p6_precond, 3),
        "probe6_conditional_disagree_given_precondition": (round(p6_conditional, 3) if p6_conditional is not None else None),
        "probe6_fallback_pair_rate": round(p6_fallback_rate, 3),
        "probe6_positive_control_changed": p6_pos_ok,
        "probe6_positive_control_detail": p6_pos_results,
        "probe7_fallback_rate": round(p7, 3),
        "probe7_fallback_rate_domain_b": round(p7_b, 3),
        "probe7_cross_domain_verdict": p7_verdict,
        "probe7_real_routes_domain_b": len(real_routes_b),
        "observations": obs,
        "verdicts": _vd,
        "probe10_turn_influence_rate": round(p10, 4),
        "probe10_turn_influence_perturbations": p10_n,
        "probe10_panel_membership_change_rate": round(p10_disp_rate, 4),
"probe11_tiebreak": p11,
        "probe12_key_perm_selection_change_rate": round(p12, 4),
        "probe12_key_perm_trials": p12_n,
        "probe13_fallback_cost": p13,
        "probe13_mean_overlap": p13["mean_overlap"],
        "probe13_replaced_ge2_rate": p13["replaced_ge2"],
        "probe14_deletion_promotion": p14,
        "probe15_negctl_matrix": p15,
        "probe16_roster_table_consistency": p16,
        "probe0_null_whitespace_change_rate": round(p0, 4),
        "probe0_null_surface_change_rate": round(p0b, 4),
        "detector_false_positive_floor": round(detector_fp, 4),
        "probe0c_identity_swap_change_rate": round(p0c, 4),
        "real_routes_used": len(real_routes),
        "probe8_persona_layer_files_neutralized": p8_changed,
        "probe8_persona_layer_persona_files": p8_persona,
        "probe8_persona_layer_sig_change": round(p8_sig, 3),
        "probe9_table_parity_mismatches": (len(parity_diff) if parity_diff is not None else None),
        "probe9_table_parity_missing": (parity_missing if parity_diff is not None else None),
        "distinct_panels": distinct,
        "distinct_routing_rules": distinct_reason,
    }

    if as_json:
        print(json.dumps(out, ensure_ascii=False, indent=2))
        return out

    print()
    print("────── 🔬 Trump Brain Panel · 换人测试 ──────")
    print(f"话题数：{len(topics)}")
    print()
    print("  PROBE 0  null（零扰动·校准）       结构变化率  %5.1f%%   ← 必须为 0%%；>0 即探测器假阳性率" % (p0 * 100))
    print("         └ 零扰动B（大小写/规范化）   结构变化率  %5.1f%%   ← 路由对表层敏感吗" % (p0b * 100))
    print("         └ 零扰动C（同一路径·恒等替换）结构变化率  %5.1f%%   ← 校准扰动路径本身" % (p0c * 100))
    print("  PROBE 1  reseed（重跑）            结构变化率  %5.1f%%   ← 只能失败，不能给正向读数" % (p1 * 100))
    print("  PROBE 2  static（换静态路由表）    结构变化率  %5.1f%%   文本变化率  %5.1f%%" % (p2_sig * 100, p2_line * 100))
    print("  PROBE 3  corpus（换动态语料）      结构变化率  %5.1f%%   文本变化率  %5.1f%%" % (p3_sig * 100, p3_line * 100))
    print("  PROBE 4  profile描述（换描述字段）  结构变化率  %5.1f%%   文本变化率  %5.1f%%" % (p4_sig * 100, p4_line * 100))
    print("  PROBE 5  weight（力量拉平）        结构变化率  %5.1f%%" % (p5_sig * 100))
    print("  PROBE 6  paraphrase（换个说法）    面板不一致率 %5.1f%%   （%d 对保义改写）" % (p6 * 100, p6_total))
    print("         └ 前提：两句都命中真实路由  %5.1f%%   （%d/%d 对）" % (p6_precond * 100, p6_both_real, p6_total))
    print("         └ 条件性不一致率          %s   ← 只在满足前提的对里算" % ("  n/a " if p6_conditional is None else "%5.1f%%" % (p6_conditional * 100)))
    print("         └ 兜底占比（至少一边）    %5.1f%%   ← 兜底对会让「不一致」看起来像「脆弱」" % (p6_fallback_rate * 100))
    print("         └ 阳性对照（增义改写应换人）%s" % ("n/a" if p6_pos_ok is None else ("✅ 全部换人" if p6_pos_ok else "❌ 有增义改写没换人")))
    print("  PROBE 7  fallback（没命中路由）    %5.1f%% 的问题落到兜底（%d 条真实路由规则）" % (p7 * 100, len(real_routes)))
    print("         └ 第二领域（运维/技术）     %5.1f%% 的问题落到兜底（%d 条真实路由规则）" % (p7_b * 100, len(real_routes_b)))
    print("         └ 跨领域判定              %s  （新领域 %+.1f 个百分点）" % (p7_verdict, p7_gap * 100))
    print("         └ 观测数(A)              routing=%d  static=%d  dynamic=%d  fallback=%d  persona_text=%d"
          % (obs["routing_entered"], obs["static_route_hit"], obs["dynamic_corpus_hit"], obs["fallback"], obs["persona_text_entered"]))
    print("         └ 观测数(B)              routing=%d  fallback=%d  static=%d  dynamic=%d"
          % (obs["domainB_routing_entered"], obs["domainB_fallback"],
             obs["domainB_static_route_hit"], obs["domainB_dynamic_corpus_hit"]))
    print("  PROBE 8  persona layer（中性化）   结构变化率  %5.1f%%   （改了 %d 个 SKILL.md，其中 %d 个是十神人格）" % (p8_sig * 100, p8_changed, p8_persona))
    print("  PROBE 10 turn-influence（发言位）  跨发言位影响率 %5.1f%%   （%d 次扰动）" % (p10 * 100, p10_n))

    print("  PROBE 11 tie-break（名册顺序控制）  A 只改顺序 %5.1f%%   B 只改权重 %5.1f%%   C 两者都改 %5.1f%%"
          % (p11["cond_A_order_only"] * 100, p11["cond_B_weights_only"] * 100, p11["cond_C_both"] * 100))
    print("         └ 条件D：权重全平时选中的人 = 文件行序前三？ %s   （%d/%d 兜底观测，%d 个排列）"
          % ("n/a" if p11["cond_D_follows_among_fallback"] is None else "%5.1f%%" % (p11["cond_D_follows_among_fallback"] * 100),
             p11["cond_D_fallback_obs"], p11["cond_D_fallback_obs"], p11["cond_D_permutations"]))
    print("  PROBE 15 负控矩阵  %d/%d 行**按预期的理由**红了%s   可发现的破坏类：%s"
          % (sum(1 for r in p15["rows"] if r["pass"]), p15["n"],
             (f"（FAIL={p15['n_fail']} INCONCLUSIVE={p15['n_inconclusive']}）"
              if (p15["n_fail"] or p15["n_inconclusive"]) else ""),
             ", ".join(p15["detectable_breaks"])))
    print("  （旧的打印行）  %d/%d 行符合预期   可发现的破坏类：%s"
          % (sum(1 for r in p15["rows"] if r["pass"]), p15["n"],
             ", ".join(p15["detectable_breaks"])))
    print("         └ ⚠️ 绿灯**只接到这些**上；没列出来的破坏类这套测试发现不了")
    print("  PROBE 14 删除即上位  删掉 %s 后：%d/%d 个话题的**在场人员**变了（其中 %d 个权重一个都没变），"
          "记录点名了 %d/%d 次上位"
          % (p14.get("victim"), p14.get("panel_changed", 0), p14.get("n", 0),
             p14.get("zero_weight_change", 0), p14.get("named_by_record", 0),
             p14.get("panel_changed", 0)))
    print("  PROBE 13 兜底成本（面板替换）  规则面板 vs 兜底面板：平均重合 %s/3   换掉≥2人占比 %s   (n=%d 条命中规则的话题)" % (
        p13["mean_overlap"], ("%.1f%%" % (p13["replaced_ge2"] * 100)) if p13["replaced_ge2"] is not None else "n/a", p13["n"]))
    print("  PROBE 12 名册键序不变性（分数全平）  选中集合变化率 %5.1f%%   （%d 次键序置换 × %d 话题）" % (p12 * 100, PERM_TRIALS, len(topics)))

    print("         └ 面板成员变动率          %5.1f%%   （这是排序在工作，不是影响）" % (p10_disp_rate * 100))
    if parity_diff is None:
        print("  PROBE 9  table parity             跳过（找不到 skills/ask/SKILL.md）")
    else:
        print("  PROBE 9  table parity             %s" % ("✅ 两份路由表一致" if not parity_diff else "❌ %d 条不一致: %s" % (len(parity_diff), parity_diff)))
        if parity_missing:
            print("                               仅出现在一份表里的条目: %s" % parity_missing)
    print()
    print(f"  RESOLUTION  {len(topics)} 个话题 → {distinct} 个不同的面板（{distinct_reason} 条不同路由规则）")
    print()
    print("  怎么读这些数字：")
    print("   · PROBE 4 = 0%  →  **trump-profile.json 的 description 字段**不影响路由。")
    print("     注意：这是 profile 的描述，不是人格内容。")
    print("   · PROBE 8 = 0%%  →  把 %d 个 persona SKILL.md 全部中性化，结构**完全不变**。" % p8_changed)
    print("     **这 0% 测的是探针自己的盲区，不是 artifact 的人格层** —— demo 从不加载那些文件。")
    print("     人格层只在模型生成台词时进入，所以人格的影响**必须调一次模型才能测**。")
    print("   · PROBE 7 高  →  大部分问题根本没命中路由规则，拿到的是同一个兜底面板。")
    print("     跨领域判定 %s：%s" % (p7_verdict,
          "兜底率在第二个领域**没有下降** → 兜底不是话题集挑出来的；**路由本来就薄，"
          "而且只在它自己那套词汇上不薄**。十神层大部分是装饰。" if p7_verdict == "router-coverage-is-domain-specific"
          else "换个领域兜底率就掉 → **是我原来那批话题挑得让它显得覆盖更好**，测试集是瓶颈。"))
    print("   · PROBE 5 = 100%  →  兜底路径就是「按力量取前三」，**权重向量就是路由器**。")
    print("   · PROBE 9  →  demo.py 里手抄了一份路由表；今天两份一致，但没有东西保证明天还一致。")
    print("   · PROBE 10 →  扰动一个发言位，**同时在场的别人**的音量一点没变 → 跨发言位影响率 0.0%。")
    print("   · PROBE 11 →  **PROBE 5 的 100% 原来是一个混淆**。它同时动了两个变量：权重偏好 + tie-break 规则。")
    print("     只改名册顺序（A）→ 0.0%：现有分数互不相同，顺序平时是惰性的。")
    print("     权重全平后（D）→ 选中的三个人 **100%% = 文件里的行序前三**（n=%d）。"
          % p11["cond_D_fallback_obs"])
    print("     → **trump-profile.json 的键顺序是一份没写出来的治理模型**。"
          "谁重排这个 JSON 的键，谁就改了「谁先开口」，而 diff 里只看到挪动的字段。")
    print("     同时「面板成员变动率」很高 —— 那只是**排序**在工作，不是影响。两者必须分开测，")
    print("     混在一起会把「没有回合之间的通道」变成一个 56% 的假信号。")
    print("     意思不是「面板很稳」，而是**面板根本不存在回合之间的通道**：")
    print("     面板 = f(topic)，每一行由自己的分数决定，谁都不是别人的输入。")
    print("     @Kleinbot 的干预测试在这里**没有可执行的位置** —— 没有第三回合可以植入命题。")
    print("   · 三态结果  →  INADEQUATE 不是失败，是「这个群体撑不住这个结论」。")
    print("     效力声明写在**发行时**：观测数不够的探针不许出数字。")
    print("   · PROBE 0  →  **零扰动必须为 0%%**。它是用来校准探测器的：")
    print("     零扰动走的是**完全相同**的扰动管线，只是输入是语义保持的重编码。")
    print("     若它报出变化率 > 0，那这个数就是**探测器的假阳性率**，表里每个读数都要按它上浮。")
    print("     零扰动 C 走的是**和 PROBE 2 完全相同的一行代码**，只是换进去的是它自己的深拷贝 ——")
    print("     它校准的是**扰动路径**，零扰动 A/B 校准的是**探测器**。两个零都要是 0。")
    print("     没有这个零，0%% 分不清是「这一层不要紧」还是「我的探测器太灵」。")
    print("   · PROBE 6 高  →  路由靠字面关键词，换个说法就换一群人。")
    print("     **但先看前提数字**：如果大部分对落在兜底，「不一致」可能只是同一个兜底房间。")
    print("     报告这个数字时，**前提数字必须和结果数字一起给**，否则条件会静默变成无条件。")
    print("   · RESOLUTION  →  面板是 N 个问题上的一个粗量化器。")
    print()
    print("  ── 运行回执（这份数字读的是什么）──────────────────────────────")
    print("     git_sha      : %s%s" % (manifest["git_sha"],
                                        "  (工作树有改动)" if manifest["git_dirty"] else ""))
    print("     profile_hash : %s   (trump-profile.json / tenGods)" % manifest["profile_hash"])
    print("     fixture      : %s  (自由语料 %d 条 + 规范语料 %d 条)"
          % (manifest["fixture"], manifest["fixture_topic_count"],
             manifest["canonical_prompt_count"]))
    print("     started      : %s" % manifest["started"])
    print("     摘要行        : %s" % summary_line)
    print("     （摘要行把三种状态**同时**写在一行里 —— 它不能被压成「基本通过」。）")
    print()
    print("  ── 三态结果（值 / 观测数 / 区间 / 适用性）────────────────────────────")
    for _lbl, _v in [("PROBE 6 可见", v6_vis), ("PROBE 6 条件性", v6_cond),
                     ("PROBE 7 领域A", v7_a), ("PROBE 7 领域B", v7_b),
                     ("PROBE 8 人格层", v8), ("PROBE 9 表一致", v9),
                     ("PROBE 10 发言位影响", v10),

                     ("PROBE 11 跟着行序走", v11),
                     ("PROBE 12 键序不变性", v12),
                     ("PROBE 13 兜底成本", v13),
                     ("PROBE 14 删除即上位", v14),
                     ("PROBE 15 负控矩阵", p15),
                     ("PROBE 16 名册/路由表", v16)]:

        if _v["state"] == "OK":
            _ci = _v["ci"]
            _cis = "[%s, %s]" % (("%.2f" % _ci[0]) if _ci[0] is not None else "?",
                                 ("%.2f" % _ci[1]) if _ci[1] is not None else "?")
            print(f"    {_lbl:20} OK          值=%-7s n=%-4d 95%%CI=%-16s min_n=%d" %
                  (_v["value"], _v["n"], _cis, _v["min_n"]))
        else:
            print(f"    {_lbl:20} {_v['state']:<13} n=%-4d 需要 n>=%-4d %s" %
                  (_v["n"], _v["min_n"], _v["note"]))
    print()
    if obs["persona_text_entered"] == 0:
        print("  ⚠️⚠️ LOUD FAIL：persona/text 层 **观测数 = 0** —— 这一层从未被进入。")
        print("       下面任何关于「人格层」的 0.0% **不是结果**，是**零观测**。")
        print("       （@solanize：0 观测和 0 变化不能再共用同一个格子。）")
        print()
    print("  ⚠️ LIMITATION（这段是仪器的边界，不是免责声明）：")
    print("     这个脚本测的全部是**结构层**：谁发言、什么顺序、多大声。")
    print("     它**没有**测人格内容对台词的影响，因为那需要真的调一次模型。")
    print("     所以 PROBE 4 / 8 的 0% 说明「结构层与人格层是解耦的」，")
    print("     **不**说明「人格没用」。两个结论看起来一样，证据完全不同。")
    if p6_examples:
        print()
        print("  换个说法就换面板的例子：")
        for a_t, b_t, sa, sb in p6_examples:
            print(f"    「{a_t}」 → {[x[0] for x in sa]}")
            print(f"    「{b_t}」 → {[x[0] for x in sb]}")
    print()
    return out


def main():
    ap = argparse.ArgumentParser(description="固定卡组面板的换人测试")
    ap.add_argument("--topics", help="逗号分隔的话题；不给就用默认的 21 个")
    ap.add_argument("--json", action="store_true", help="输出 JSON")
    args = ap.parse_args()
    topics = ([t.strip() for t in args.topics.split(",") if t.strip()]
              if args.topics else DEFAULT_TOPICS)
    out = report(topics, as_json=args.json)
    # ⚠️ 之前 main 只是调用 report() 然后丢掉返回值 → **探针 FAIL 时进程仍然 exit 0**。
    #    一个「不会让 CI 变红」的失败，等于没有失败。
    # → 现在：worst_claim_state == FAIL → 退出码 1。
    #    INADEQUATE **不**让退出码变红：它是「这个结论还不能断言」，不是「测试没过」。
    if isinstance(out, dict):
        wc = out.get("worst_claim_state")
        if wc == "FAIL":
            print("\n[SUITE] ❌ 有探针处于 FAIL 状态 → 退出码 1")
            return 1
    return 0


if __name__ == "__main__":
    sys.exit(main() or 0)
