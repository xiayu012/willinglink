import "server-only";

import { generateText, hasToolCall, stepCountIs, tool } from "ai";
import { z } from "zod";
import { assembleSystemPrompt } from "@/lib/ai/brains";
import { getLanguageModel } from "@/lib/ai/providers";
import { buildContext } from "./context";
import { kitchenEveningWindow } from "./coordination-bridge";
import { advanceCoordinationSession } from "./coordination-session";
import type { OutboundAction, State } from "../../coordination/types";
import { critique, critiqueBatch, hasSafetySensitiveTopic } from "./critic";
import type { Verdict } from "./critic";
import { assertCanWrite } from "./guard";
import { colivingModelId } from "./model";
import { embedOne } from "./embedding";
import * as repo from "./repo";
import {
  bestSchedulePlans,
  checkScheduleSlotConsistency,
  describeFairnessGain,
  findSchedulePlans,
  formatMinutes,
  selectScheduleCandidate,
  type ScheduleSelection,
} from "./scheduling";

/**
 * 一轮对话最多几步工具。比以前长：现在一轮里可能要
 * 判断 → 查历史 → 开 case → 联系另一个人 → 记规则。
 */
const MAX_STEPS = 6;
const HH_MM_PATTERN = /^(?:[01]\d|2[0-3]):[0-5]\d$/;
// deepseek-v4-flash 多步一轮实测 131–240 秒，120 秒会被自己打断（gateway 报
// operation aborted due to timeout）。路由 maxDuration 是 300 秒，这里给 240 秒
// 留出余量；仍可用 COLIVING_TURN_MODEL_TIMEOUT_MS 覆盖。
const TURN_MODEL_TIMEOUT_MS = Number(
  process.env.COLIVING_TURN_MODEL_TIMEOUT_MS ?? 240_000
);

function turnAbortSignal(): AbortSignal {
  return AbortSignal.timeout(TURN_MODEL_TIMEOUT_MS);
}

export function hasDeferredCoordination(text: string): boolean {
  return text.split(/[。！？!?\n]/).some(
    (clause) =>
      (
        /我[^。！？!?\n]{0,24}(?:会|先|再|回头|稍后|马上|这就|现在就|准备|打算|正在|还在)[^。！？!?\n]{0,20}(?:问|联系|核实|找|商量|收)/.test(
          clause
        ) &&
        /(?:其他|另外|几位|大家|他们|她们|房东|住户|室友|对方|两位)/.test(
          clause
        )
      ) ||
      /(?:后面|之后|以后|回头|稍后)[^。！？!?\n]{0,20}(?:排|安排|协调|联系|询问|问)/.test(
        clause
      )
  );
}

/**
 * `还在`（"我还在问另外两位"）跟 `正在/已经` 一样，字面上是在声称一件
 * 正在发生的联系动作，容易被当成"这轮确实发出去了"——同样按"声称
 * 联系完成/进行中"处理，交给 `checkFalseContactClaim` 核对：这一轮发给
 * 对方的联系若被审稿拦下、实际没发出去，就不能用任何时态说成已联系/
 * 正在联系。跟 `会/稍后/回头` 这类真正面向未来、还没开始的措辞区分开——
 * 那些不在这个标记列表里，保留原样，不算这里要拦的"误导性在途声称"。
 */
const CLAIMED_CONTACT_COMPLETION_PATTERN =
  /(?:(?:我|这边|马上|现在)?(?:正|正在|已经|这就|刚刚?|刚才|还在)(?:跟|和|给|去跟|去和|去给)?.{0,6}(?:发|说|商量|联系|问|通知|沟通|确认|谈|提|讲|劝|催|提醒|追)|(?:我|这边)[^。！？!?\n]{0,12}(?:问|联系|找|催|追|跟[^。！？!?\n]{0,6}(?:说|确认|核实|商量))[^。！？!?\n]{0,6}了)/;

export function claimsContactCompletion(text: string): boolean {
  return CLAIMED_CONTACT_COMPLETION_PATTERN.test(text);
}

/** case.kind 是开放文本；只有明确属于同住人或共享资源争用的未结事项才算。 */
export function isOpenConflictCase(c: { kind: string; title: string }): boolean {
  return (
    /(?:conflict|contention|dispute|roommate|housemate|noise|clean(?:ing)?|trash|kitchen|bathroom|laundry|parking|guest)/i.test(
      c.kind
    ) ||
    /(?:冲突|争用|争抢|室友|同住|厨房|灶台|卫生间|浴室|洗衣|停车|噪音|清洁|垃圾|访客)/.test(
      c.title
    )
  );
}

export function isLowInformationFollowUp(text: string): boolean {
  return /^(?:你好|您好|在吗|嗨|哈喽|hello|hi|嗯+|哦+|好(?:的)?|收到|知道了|谢谢)[!！。,.，?？\s]*$/i.test(
    text.trim()
  );
}

const CAPACITY_ESCAPE_PATTERN =
  /(?:(?:添|加|买|自备|自己带|提供|准备).{0,10}(?:小电炉|电磁炉|便携(?:式)?(?:电)?炉|第二(?:个|台)?(?:灶|炉))|(?:小电炉|电磁炉|便携(?:式)?(?:电)?炉|第二(?:个|台)?(?:灶|炉)).{0,10}(?:办法|出路|解决|同时)|同时(?:开火|做饭)|两人.{0,8}(?:同时|一块儿).{0,8}(?:做饭|开火)|台面.{0,10}插座.{0,10}(?:两人|同时|开火)|插座.{0,10}(?:两人|同时|开火))/;

/** 共享资源冲突还没经排班器证明无解时，不许把“加设备/并行使用”说成出路。 */
export function isPrematureCapacityEscape(
  text: string,
  hasOpenConflict: boolean,
  scheduleProvenInfeasible: boolean
): boolean {
  return hasOpenConflict && !scheduleProvenInfeasible && CAPACITY_ESCAPE_PATTERN.test(text);
}

function isGeneratedResidentName(name: string): boolean {
  return /^\d+号住客$/.test(name.trim());
}

/**
 * 住户回复"愿意/行/没问题"这类简短肯定——只落锤，不需要复述全案。
 *
 * 要求：整条消息就是表示同意，不含新的诉求或质疑。用于检测"这条消息
 * 等价于「我同意」"，避免误伤"我同意，但你能解释一下为什么我最后用？"
 * 这类含追问的回复（那类仍该走完整的模型处理流程）。
 */
export function isSimpleAffirmation(text: string): boolean {
  return /^(?:愿意|行|好的?|可以|没问题|同意|确认|OK|ok|好啊|妥|妥了|行的?|没有问题|可以的?)[!！。.，,\s]*$/i.test(
    text.trim()
  );
}

/**
 * 说话人正在**反对这次排班，而且质疑的是公平性**（"凭什么我让着别人"、
 * "最早提的就优先"这类）。真实事故（2026-09）：住户刚说不合适、不公平，
 * 确定性回复路径仍把同一版方案原样复述一遍还加一句"不合适跟我说"——等于没听。
 * 命中这类消息时，`renderBaseFacts` 注入"先接住反对、提议轮换/重新协商"
 * 的信号，doctrine 也有对应小节，让大脑别再原样丢回旧方案。
 */
export function isScheduleFairnessObjection(text: string): boolean {
  return /不合适|不公平|凭什么|凭啥|不同意|不接受|让着|最早提/.test(text);
}

/**
 * 纯确认/知会的短句白名单。代码能确定"这句只是收个话头"，没有下指令、
 * 没有点名、没有承诺动作、没有宣称已经做了什么——这类低风险回复不值得再
 * 花一次模型调用过语言批判器（措辞风险低）。
 *
 * 判定方式：整句切成小段后，每一段都得是白名单里的确认词。任何额外的内容
 * （"我回头联系他"、"你最好先……"）都不在白名单里，仍然走批判器。
 * **宁可保守：判不准就不是纯确认，照常过审。**
 */
const NOTICE_ACK_WORDS = new Set([
  "好", "好的", "好嘞", "行", "行的", "行吧", "嗯", "嗯嗯", "嗯好", "哦", "哦哦",
  "哦好", "啊", "对", "对的", "没错", "是的", "没问题", "可以", "可以的", "OK",
  "ok", "Ok", "收到", "知道了", "明白", "明白了", "了解", "了解了", "谢谢",
  "谢谢了", "多谢", "感谢", "谢谢告知", "谢谢提醒", "谢谢通知", "谢谢说明",
  "谢谢你的告知", "知道了谢谢", "好的收到", "辛苦", "辛苦啦", "了解啦",
]);

export function isPureNoticeReply(text: string): boolean {
  const t = text.trim();
  if (!t || t.length > 40) {
    return false;
  }
  const segments = t.split(/[，,。!！?？~～、;；\s]+/).filter((s) => s.length > 0);
  return segments.length > 0 && segments.every((s) => NOTICE_ACK_WORDS.has(s));
}

/**
 * 这轮只要动过排班/联系人/规则任何一个，回复就"不是安静的纯确认回合"——
 * 判"能不能确定性跳过批判器"时当作仍有实质内容，照常过审。
 */
const TURN_ACTION_TOOLS = new Set([
  "pickSchedule",
  "chooseSchedule",
  "contactPerson",
  "addResident",
  "proposeRule",
  "recordShare",
  "scheduleReminder",
]);

/**
 * 这条消息是不是在回答系统发给他的一条排班时段征询。
 * 判据：pending communication 的 act 是 ask/propose/confirm（生产实测 act=ask），
 * 且 body 包含系统生成的排班征询模板特征（"你用 HH:MM-HH:MM"）。
 *
 * 真实生产日志：`contactPerson` 发出的时段征询 act 字段落库为 `ask`（不是 propose/confirm）。
 * 初版只检查 propose/confirm，导致生产场景全部漏识别。
 */
export function isScheduleSlotInquiry(answering: {
  act?: string | null;
  body: string;
} | null): boolean {
  if (!answering) return false;
  const act = answering.act;
  if (act !== "ask" && act !== "propose" && act !== "confirm") return false;
  return /你用\s*\d{2}:\d{2}-\d{2}:\d{2}/.test(answering.body);
}

/**
 * 从征询消息体里提取时段字符串（如 "07:30-07:35"）。
 */
export function extractSlotFromInquiry(body: string): string | null {
  const m = body.match(/你用\s*(\d{2}:\d{2}-\d{2}:\d{2})/);
  return m?.[1] ?? null;
}

/**
 * 纯函数：判断选定方案时段与住户自报精确时段是否完全吻合。
 *
 * selfStated 来自 selfStatedSlotsByWindow（pickSchedule 时由 saidExactSlot=true 存入）；
 * selectedSlot 来自 contactPerson 调用时传入的 scheduleSlot。
 * 只有 start 和 end 同时相等才视为预先同意；任一不符说明算法已挪位，仍需征询。
 *
 * 提取为纯函数仅为可测试性——实际比对逻辑与 contactPerson 内部的 isSelfStated 完全一致。
 */
export function scheduleSlotMatchesSelfStatement(
  selfStated: { start: string; end: string } | undefined,
  selectedSlot: { start: string; end: string }
): boolean {
  return (
    selfStated !== undefined &&
    selfStated.start === selectedSlot.start &&
    selfStated.end === selectedSlot.end
  );
}

/**
 * 生成排班联系正文。抽成纯函数只为可测试性。
 *
 * 排班联系正文**一律**用征询措辞，**不按 act 分支**。上一版按 act 分
 * inform/remind →「就这样定了」（Codex Sonnet-4.5 全量回归实测结论）：
 * 模型的 act 字段不可靠，常在还在提议征询时就填 inform，把「就这样定了」
 * 发给还没确认的人。审稿清单第 11 条也明确共同生活规则是提议不是通知。
 * 「已确认同一 slot 的人不再重复联系」由调用方的 hasDurableConfirmedSlot
 * 跳过逻辑负责，不靠正文语气——act 不是可靠的定案信号。
 *
 * 函数保留 act 形参仅为兼容调用方/测试签名，任何 act 都必须返回征询正文。
 */
export function scheduleContactTextForAct(args: {
  act: string;
  salutation: string;
  windowLabel: string;
  scheduleSlot: { start: string; end: string };
}): string {
  return (
    `${args.salutation}关于${args.windowLabel}，我先提出一个待确认的安排：` +
    `你用 ${args.scheduleSlot.start}-${args.scheduleSlot.end}。这不是定案；你愿意吗？` +
    "如果不合适直接告诉我，我会根据大家的回复继续协调。"
  );
}

/**
 * 从征询消息体里取窗口名：正文模板是「关于${scheduleWindowLabel}，我…」。
 * 取不到返回 null（旧消息/非模板），不影响 slot 级匹配。
 */
export function extractWindowLabelFromInquiry(body: string): string | null {
  const m = body.match(/关于(.+?)，/);
  return m?.[1]?.trim() ?? null;
}

/**
 * 一条 communication + 它被 linkResponse 关联回的回复，是否构成「住户已确认
 * 某排班时段」的持久事实。判据：回复是简单肯定（愿意/行/可以…整句就是同意），
 * 且被回复的征询正文带「你用 HH:MM-HH:MM」的模板时段。
 */
export function scheduleInquiryConfirmation(raw: {
  inquiryBody: string;
  responseBody: string;
}): { windowLabel: string | null; start: string; end: string } | null {
  if (!isSimpleAffirmation(raw.responseBody)) return null;
  const slot = extractSlotFromInquiry(raw.inquiryBody);
  if (!slot) return null;
  const [start, end] = slot.split("-");
  return {
    windowLabel: extractWindowLabelFromInquiry(raw.inquiryBody),
    start,
    end,
  };
}

export function extractExplicitFixedStart(statement: string): number | null {
  // “没有要求必须18点开始”“不是固定在18点”是在明确否定固定开始。
  // 先吃掉否定，否则下面只截到后半句“必须18点”，会把相反事实当硬约束。
  if (
    /(?:不|没|没有|并非|不是)[^，。；]{0,10}(?:只能|必须|固定)/.test(statement)
  ) {
    return null;
  }
  const clause = statement.match(/(?:只能|必须|固定(?:在)?)[^，。；]{0,12}/)?.[0];
  if (!clause) return null;
  const hhmm = clause.match(/(\d{1,2})[:：]([0-5]\d)/);
  const hourText = clause.match(/(\d{1,2})点(半|[0-5]?\d分?)?/);
  const hour = Number(hhmm?.[1] ?? hourText?.[1]);
  const minute = hhmm
    ? Number(hhmm[2])
    : hourText?.[2] === "半"
      ? 30
      : Number(hourText?.[2]?.replace("分", "") ?? 0);
  if (!Number.isInteger(hour) || hour < 0 || hour > 23 || minute < 0 || minute > 59) {
    return null;
  }
  return hour * 60 + minute;
}

/**
 * 从一条 position statement 里抽取**软偏好的开始时间**（分钟，0-1439）。
 *
 * 与 `extractExplicitFixedStart` 的分工：硬约束（只能/必须/固定）归那个
 * 函数处理，把 earliest/latest 钉死；这里只认「最合适/习惯/方便/直接报个
 * 时刻」这类**可让步**的偏好时间，供 `pickSchedule` 在模型本轮漏填
 * `preferredStart` 时兜底（软偏好，不碰 hard 约束）。
 *
 * 保守边界（宁可漏注，不可错注）：
 * - 整句在说硬约束（`extractExplicitFixedStart` 能抽出时间）→ 直接 null。
 *   那个时间已经作为 hard 注入，同一句话不能标注两遍。
 * - 时间出现在否定/假设/过去式语境（不是X点、X点不行、不接受X点、如果X点、
 *   昨天X点）→ 剔除；全被剔除就 null。
 * - 同一句里多个**不同**的时间候选都存活（"七点或八点都可以"、"X点到Y点"）
 *   → 拿不准哪个是偏好，null。
 * - 12→24 推断只做保守这一种：窗口本身在 PM 区间（windowStartMinutes >=
 *   12:00）而说的是 1-11 点这种 12 小时制表达，按晚上抬 12 小时；明确写了
 *   上午/下午标记按标记走；其余拿不准不抬。宁可不注入，也不许把 7 点注成
 *   19 点（或反过来）。
 */
export function extractPreferredStart(
  statement: string,
  windowStartMinutes: number
): number | null {
  // 硬约束句子整体不参与软偏好抽取（见上注释第一条）。
  if (extractExplicitFixedStart(statement) !== null) return null;

  const hits = scanTimeHits(statement);
  if (hits.length === 0) return null;

  const survivors: number[] = [];
  const seen = new Set<number>();
  for (const hit of hits) {
    if (timeHitInExcludedContext(statement, hit)) continue;
    const minutes = softTimeToMinutes(statement, hit, windowStartMinutes);
    if (minutes === null) continue;
    if (!seen.has(minutes)) {
      seen.add(minutes);
      survivors.push(minutes);
    }
  }
  return survivors.length === 1 ? survivors[0] : null;
}

const CN_DIGIT: Record<string, number> = {
  零: 0,
  〇: 0,
  一: 1,
  二: 2,
  两: 2,
  三: 3,
  四: 4,
  五: 5,
  六: 6,
  七: 7,
  八: 8,
  九: 9,
};

/** 中文数字（0-99，含「十」「X十Y」），解不出或越界返回 null。 */
function parseCnNumber(text: string): number | null {
  if (!text) return null;
  const chars = [...text];
  if (!chars.includes("十")) {
    if (chars.length !== 1) return null;
    const d = CN_DIGIT[chars[0]];
    return d === undefined ? null : d;
  }
  if (chars.length === 1 && chars[0] === "十") {
    // 单独的「十」＝10（「七点十分」的分钟）。
    return 10;
  }
  if (chars.length === 2 && chars[0] === "十") {
    // 十X（十、十一、十九）
    const ones = CN_DIGIT[chars[1]];
    return ones === undefined || ones === 0 ? null : 10 + ones;
  }
  if (chars.length === 2 && chars[1] === "十") {
    // X十（二十、九十）
    const tens = CN_DIGIT[chars[0]];
    return tens === undefined || tens === 0 ? null : tens * 10;
  }
  if (chars.length === 3 && chars[1] === "十") {
    // X十Y（二十一、二十三）
    const tens = CN_DIGIT[chars[0]];
    const ones = CN_DIGIT[chars[2]];
    if (tens === undefined || ones === undefined || tens === 0) return null;
    return tens * 10 + ones;
  }
  return null;
}

type TimeHit = {
  /** 时间 token 的起始下标（statement 内） */
  index: number;
  /** 时间 token 原文长度（含分钟部分），用于取后面的语境窗口 */
  rawLen: number;
  /** 12 小时制/24 小时制都先解出的字面小时（0-23 内） */
  hour: number;
  minute: number;
};

/**
 * 扫出 statement 里所有「时刻」候选：阿拉伯 `18:30`/`18点30`/`6点半`，
 * 中文 `七点`/`六点半`/`七点十分`（零点到二十三，含「点/时」「半」「分」）。
 * 只解字面值，不做 12→24 推断（那是 `softTimeToMinutes` 的事）。
 */
function scanTimeHits(statement: string): TimeHit[] {
  const hits: TimeHit[] = [];
  const push = (index: number, rawLen: number, hour: number, minute: number) => {
    if (!Number.isInteger(hour) || hour < 0 || hour > 23 || minute < 0 || minute > 59) return;
    hits.push({ index, rawLen, hour, minute });
  };

  // 阿拉伯数字 HH:MM / H:MM（含全角冒号）。
  for (const m of statement.matchAll(/(\d{1,2})\s*[:：]\s*([0-5]\d)/g)) {
    push(m.index!, m[0].length, Number(m[1]), Number(m[2]));
  }

  // 阿拉伯数字 + 点/时：18点 / 18点30 / 18点半 / 6点半。
  for (const m of statement.matchAll(
    /(\d{1,2})\s*[点时]\s*(半|([0-5]?\d)\s*分?)?/g
  )) {
    const minute = m[2] === "半" ? 30 : m[3] !== undefined ? Number(m[3]) : 0;
    push(m.index!, m[0].length, Number(m[1]), minute);
  }

  // 中文数字 + 点/时：七点 / 六点半 / 七点十分 / 二十三点 / 零点。
  const cnDot = new RegExp(
    `([零〇一二两三四五六七八九十]{1,3})\\s*[点时]\\s*(半|([0-5]?\\d)\\s*分?|([零〇一二两三四五六七八九十]{1,3})\\s*分?)?`,
    "g"
  );
  for (const m of statement.matchAll(cnDot)) {
    const hour = parseCnNumber(m[1]);
    if (hour === null) continue;
    let minute = 0;
    if (m[2] === "半") minute = 30;
    else if (m[3] !== undefined) minute = Number(m[3]);
    else if (m[4] !== undefined) {
      const cnMinute = parseCnNumber(m[4]);
      if (cnMinute === null) continue;
      minute = cnMinute;
    }
    push(m.index!, m[0].length, hour, minute);
  }

  return hits.sort((a, b) => a.index - b.index);
}

/** 从句内取时间 token 前后的紧邻语境：遇到标点就停，窗口最多 8 字。 */
function clauseContext(
  statement: string,
  hit: TimeHit
): { before: string; after: string } {
  const punctuation = /[，。；、,!?！？…]/;
  let beforeStart = Math.max(0, hit.index - 8);
  for (let i = hit.index - 1; i >= beforeStart; i--) {
    if (punctuation.test(statement[i])) {
      beforeStart = i + 1;
      break;
    }
  }
  const afterMax = Math.min(statement.length, hit.index + hit.rawLen + 8);
  let afterEnd = afterMax;
  for (let i = hit.index + hit.rawLen; i < afterMax; i++) {
    if (punctuation.test(statement[i])) {
      afterEnd = i;
      break;
    }
  }
  return {
    before: statement.slice(beforeStart, hit.index),
    after: statement.slice(hit.index + hit.rawLen, afterEnd),
  };
}

/**
 * 这个时间候选是不是出现在「明显不是在说本次偏好」的语境里：
 * 否定（不是X点/不接受X点/X点不行）、假设（如果X点）、过去式（昨天X点）。
 * 命中的一律剔除，绝不注入成偏好。
 */
function timeHitInExcludedContext(statement: string, hit: TimeHit): boolean {
  const { before, after } = clauseContext(statement, hit);
  if (
    /(?:不|没|别|勿|莫|甭|拒绝|不要|不想)/.test(before) ||
    /(?:不行|不可以|不合适|不方便|不好|不妥|没空|算了|改天|太晚|太早|不要|不必|不用)/.test(after)
  ) {
    return true;
  }
  // 紧跟着"小时"的是时长不是时刻（"四点五个小时"＝4.5 小时，不是 4:05）。
  if (/^(?:小时|个钟头|个小时)/.test(after)) {
    return true;
  }
  if (
    /(?:如果|假如|要是|假设|万一|曾经|以前|昨天|前天|上周|上次|当时|原本|本来|打算|预计)/.test(before)
  ) {
    return true;
  }
  return false;
}

/** 时间 token 前面是不是带了明确的时段词（上午/下午/晚上/中午……）。 */
function periodMarker(statement: string, index: number): "am" | "pm" | "noon" | null {
  const pre = statement.slice(Math.max(0, index - 3), index);
  if (/(?:晚上|晚间|傍晚|夜里|深夜|下午|午后)/.test(pre)) return "pm";
  if (/(?:早上|上午|凌晨|清晨|早晨)/.test(pre)) return "am";
  if (/(?:中午|正午)/.test(pre)) return "noon";
  return null;
}

/** 把字面小时按语境转成分钟（0-1439）。拿不准的返回 null。 */
function softTimeToMinutes(
  statement: string,
  hit: TimeHit,
  windowStartMinutes: number
): number | null {
  const marker = periodMarker(statement, hit.index);
  let hour = hit.hour;
  if (marker === "pm") {
    // 晚上/下午七点 → 19:00。十二点（夜里十二点＝零点）这种跨天歧义
    // 在排班窗口里基本不会出现，按字面 12 处理。
    if (hour < 12) hour += 12;
  } else if (marker === "noon") {
    hour = 12;
  } else if (marker === "am") {
    // 早上七点 → 7:00（即使窗口在晚上也不抬）。
  } else if (windowStartMinutes >= 12 * 60 && hour >= 1 && hour <= 11) {
    // 没写时段词：只有窗口本身在 PM 区间、而说的是 1-11 点这种 12 小时制
    // 时刻，才敢按晚上抬 12 小时。零点/12 点及明确 24 小时表达都不动。
    hour += 12;
  }
  if (hour < 0 || hour > 23) return null;
  return hour * 60 + hit.minute;
}

export type TurnUsage = {
  steps: number;
  inputTokens: number;
  cacheReadTokens: number;
  cacheWriteTokens: number;
  outputTokens: number;
  /** gateway 报的真实计费金额（美元）。不是估算。 */
  costUsd: number;
};

type StepUsageLike = {
  inputTokens?: number;
  outputTokens?: number;
  cachedInputTokens?: number;
  inputTokenDetails?: {
    cacheReadTokens?: number;
    cacheWriteTokens?: number;
  };
};

/**
 * 从每一步累加真实用量与计费。**必须逐步累加**——带工具时一轮有多次往返，
 * 只看最后一步会严重低估。
 *
 * token 数各家形状不同，所以按优先级试：
 *   1. `providerMetadata.anthropic.usage`（Anthropic 的原始字段，最全）
 *   2. `step.usage`（AI SDK 归一化的；Anthropic 经 gateway 时是空的，别家常有）
 *
 * **金额一律取 `providerMetadata.gateway.cost`**——那是 gateway 实际计的账，
 * 与模型无关，不用自己按单价估算。换模型时这一行不用改。
 */
function sumUsage(
  steps: readonly { providerMetadata?: unknown; usage?: StepUsageLike }[]
): TurnUsage {
  const out: TurnUsage = {
    steps: steps.length,
    inputTokens: 0,
    cacheReadTokens: 0,
    cacheWriteTokens: 0,
    outputTokens: 0,
    costUsd: 0,
  };
  for (const step of steps) {
    const meta = step.providerMetadata as
      | {
          anthropic?: { usage?: Record<string, number> };
          gateway?: { cost?: string };
        }
      | undefined;
    const a = meta?.anthropic?.usage;
    if (a) {
      out.inputTokens += a.input_tokens ?? 0;
      out.cacheReadTokens += a.cache_read_input_tokens ?? 0;
      out.cacheWriteTokens += a.cache_creation_input_tokens ?? 0;
      out.outputTokens += a.output_tokens ?? 0;
    } else if (step.usage) {
      const u = step.usage;
      const read = u.inputTokenDetails?.cacheReadTokens ?? u.cachedInputTokens ?? 0;
      out.inputTokens += Math.max((u.inputTokens ?? 0) - read, 0);
      out.cacheReadTokens += read;
      out.cacheWriteTokens += u.inputTokenDetails?.cacheWriteTokens ?? 0;
      out.outputTokens += u.outputTokens ?? 0;
    }
    const cost = Number(meta?.gateway?.cost);
    if (Number.isFinite(cost)) {
      out.costUsd += cost;
    }
  }
  return out;
}

/**
 * 短信里不渲染 markdown，`**粗体**` 会原样显示成星号。
 *
 * 准则里反复要求过不要用，但模型仍然会漏——**因为准则正文自己就大量用 **
 * 加粗**。这类确定性的格式问题用代码解决比用提示词可靠：
 * 提示词管判断，代码管格式。
 */
function stripMarkdown(text: string): string {
  return text
    .replace(/\*\*(.+?)\*\*/gs, "$1")
    .replace(/(?<!\w)__(.+?)__(?!\w)/gs, "$1")
    .replace(/`([^`]+)`/g, "$1")
    .replace(/^\s{0,3}#{1,6}\s+/gm, "")
    .replace(/^\s{0,3}[-*+]\s+/gm, "")
    .replace(/\n{3,}/g, "\n\n")
    .trim();
}

export type OutboundMessage = {
  to: string;
  personId: string;
  text: string;
  communicationId: string;
  /** 审稿没过，调用方不要投递（已在库里标成 skipped 并写明原因） */
  blocked?: boolean;
  /** 被拦下的理由。给评测报告页显示用——`blocked` 只说"拦了"，这个说"为什么" */
  blockReason?: string;
  /** 这条是对**共用者**一样的规矩，不是针对他个人的事。审稿据此判角色 */
  sharedRule?: boolean;
  /**
   * 哪些人共用这件东西。**不假定是全屋**——一栋房子里可能几个人共用
   * 一个卫生间、另几个人用另一个，系统并不知道这个结构。
   */
  sharedWith?: string | null;
  /**
   * 收信人是这一轮才刚加进系统的，这条八成是中性的自我介绍，跟任何
   * 纠纷无关。审稿据此不套"被说到的人"这个角色——那是给纠纷场景
   * 准备的，套在打招呼上会把中性内容当指控来审。
   */
  isIntroduction?: boolean;
  /** 正文由已选候选和结构化时段生成，已通过代码一致性校验。 */
  scheduleVerified?: boolean;
};

/**
 * 最终发出去那条回复，实际经过审稿的结果——不是"调用过 critique"，
 * 是"送到住户手里的这句话，最后一次核对的结论"。
 *
 * 起因：以前批判器打回、重写、重写后复核仍不合格时，代码只打日志、
 * 老实把消息发出去（"有消息总好过没消息"），但外部（eval/汇总）完全
 * 看不到这件事发生过——一条批判器明知不合格的消息，跑批照样显示绿灯。
 * 现在把这个结论显式吐出来，调用方自己决定要不要因此判失败。
 */
export type ReplyReview = {
  /** 批判器是不是真跑起来给出了结论——见 critic.ts 的"默认放行"三条兜底，这里只反映"跑没跑"，不代表"跑起来了就等于没问题" */
  verified: boolean;
  /** 最终这句话有没有过审 */
  pass: boolean;
  /** 不合格时是第几条/规则 id；合格是空串 */
  broke: string;
  why: string;
};

export type TurnOutcome = {
  reply: string;
  /** 送到住户手里那句话最后一次审稿的结论，见 `ReplyReview` */
  replyReview: ReplyReview;
  /** 本轮排班工具算出并选定的事实，供离线判定器理解依据，不用于投递。 */
  scheduleFacts: string[];
  /** 回复给发信人本人的那条，也算一次 communication */
  replyCommunicationId: string | null;
  /** 主动发给房子里其他人的（杠杆二）。**已滤掉审稿拦下的，拿到就能发** */
  outbound: OutboundMessage[];
  /**
   * **含被审稿拦下的那些**，只读、不要拿去投递。
   *
   * `outbound` 必须保持"拿到就能发"的语义，所以被拦下的消息对外
   * 完全不可见——但"这条为什么被拦"恰恰是复核时最该看到的东西
   * （评测报告页要显示它，人要据此判断审稿拦得对不对）。
   * 分成两个字段，投递安全和可观测性都不牺牲。
   */
  allOutbound: OutboundMessage[];
  decisionId: string | null;
  modules: string[];
  promptChars: number;
  toolsUsed: string[];
  /** 认不出这个号码时为 true，调用方应当只回一句而不做任何记录 */
  unknownSender: boolean;
  /**
   * 这一轮真花了多少。`steps` 是模型往返次数——**带工具时一轮不止一次调用**，
   * 每次都重发整个提示词，所以这个数字直接决定成本。
   * 实测：缓存读比普通输入便宜 9.7 倍，缓存写贵 25%。
   */
  usage: TurnUsage;
  /**
   * 本轮开始的时刻。路由层用它做竞态门禁：
   * 如果出站消息的目标人在这个时刻之后有新的入站，说明上下文已过期，
   * 对应的消息应跳过而非发出。
   */
  turnStartedAt: Date;
};

/**
 * 认不出来时说什么。**这是唯一一处硬编码文案**——因为模型根本没被调用
 * （见 CLAUDE.md「不要替大脑写话术」：硬编码只留给不过大脑的路径）。
 * 短、中性、不透露任何住户信息。
 */
const UNKNOWN_REPLY = "这个号码我这边没有记录，先确认一下你是哪一位。";

/**
 * coordination 替换分支的总入口（默认关闭，`COLIVING_COORDINATION_REPLACE=1` 才开）。
 *
 * 判断这条消息是不是厨房排班相关；是 → 用 `advanceCoordinationSession`（coordination
 * 状态机）推进这一轮、把状态机 `actions` 按硬编码模板转成给发信人的回复，落库后返回
 * `TurnOutcome`；判不准或任何异常 → 返回 `null`，由旧 AI 排班流程兜底，不让替换把整
 * 轮搞挂。
 *
 * 状态机自己的事件/checkpoint 落在会话目录（缺省本地临时目录），不写 coliving 库；
 * 这里照正常回合的样子把入站消息 + 一条 `reply_only` 回复落库，回复投递交给 route.ts。
 */
async function maybeCoordinationReply(args: {
  sender: repo.Sender;
  channel: string;
  text: string;
  history: Array<{ role: "user" | "assistant"; content: string }>;
  conversationId: string;
  turnStartedAt: Date;
}): Promise<TurnOutcome | null> {
  const { sender, channel, text, history, conversationId, turnStartedAt } = args;
  try {
    // 1) 排班相关判断（保守：判不准就 return null 走原 AI 流程）。
    //    「正在回一条排班时段征询」或「正文同时带时间 + 带厨房/做饭语境」才算。
    const answering = await repo.pendingCommunication(sender.personId);
    const answeringSlotInquiry = isScheduleSlotInquiry(answering);
    const hasTimeWord =
      /\d{1,2}\s*[:：点时]/.test(text) || /[一二三四五六七八九十两]\s*点/.test(text);
    const hasKitchenWord = /厨房|做饭|做菜|灶台|排班|排时间|时段|几点/.test(text);
    if (!answeringSlotInquiry && !(hasTimeWord && hasKitchenWord)) return null;

    // 2) 用 coordination 状态机推进这一轮（事件/checkpoint 落本地会话目录）。
    const members = await repo.getMembers(sender.householdId, channel);
    const participants = members.map((m) => m.name);
    const res = await advanceCoordinationSession(
      sender.householdId,
      sender.name,
      text,
      {
        window: kitchenEveningWindow(),
        participants,
        recentDialogue: history.map((h) =>
          h.role === "assistant" ? `AI：${h.content}` : h.content
        ),
        dir: process.env.COLIVING_COORDINATION_SESSION_DIR,
      }
    );

    // 3) 把状态机 actions 转成给发信人的回复文本（硬编码模板，够用即可）。
    const reply = coordinationReplyForSender(res.actions, res.state, sender.name);

    // 4) 落库与正常回合一致：先把这条入站消息写下，再把它接回它正在回答的沟通。
    const inboundId = await repo.appendMessage({
      conversationId,
      personId: sender.personId,
      direction: "inbound",
      channel,
      body: text,
    });
    if (inboundId) {
      await repo.linkResponse({ personId: sender.personId, messageId: inboundId });
    }

    // 回复本身也算一次 communication（reply_only，同 isSimpleAffirmation 短路闸写法）。
    const decisionId = await repo.recordDecision({
      householdId: sender.householdId,
      kind: "reply_only",
      intent: "coordination 状态机接管厨房排班：把状态机动作转成回复，未走旧 AI 流程",
      modelId: colivingModelId(),
      doctrineModules: [],
      contextChars: 0,
      contextSnapshot: null,
    });
    const replyCommunicationId = await repo.queueCommunication({
      householdId: sender.householdId,
      decisionId,
      caseId: null,
      toPersonId: sender.personId,
      channel,
      purpose: "回复本人",
      body: reply,
    });
    await repo.appendMessage({
      conversationId,
      personId: sender.personId,
      direction: "outbound",
      channel,
      body: reply,
      communicationId: replyCommunicationId,
    });

    return {
      reply,
      replyReview: { verified: true, pass: true, broke: "", why: "" },
      scheduleFacts: [],
      replyCommunicationId,
      outbound: [],
      allOutbound: [],
      decisionId,
      modules: [],
      promptChars: 0,
      toolsUsed: [],
      unknownSender: false,
      usage: {
        steps: 0,
        inputTokens: 0,
        cacheReadTokens: 0,
        cacheWriteTokens: 0,
        outputTokens: 0,
        costUsd: 0,
      },
      turnStartedAt,
    };
  } catch (error) {
    console.log(
      "[coordination-replace] 状态机替换失败，回退旧 AI 流程：",
      error instanceof Error ? error.message : String(error)
    );
    return null;
  }
}

/**
 * 把 coordination 状态机这轮产出的 `actions` 按「发信人本人」的视角转成一句短信回复：
 * 只挑发给这个人的 settle/propose/remind；blocked 是全局诊断；其余按终态给短句。
 * 模板是硬编码的（模型没被调用来写措辞，见「不要替大脑写话术」对硬编码的边界）。
 */
function coordinationReplyForSender(
  actions: readonly OutboundAction[],
  state: State,
  self: string
): string {
  const settleForSelf = actions.find(
    (a): a is Extract<OutboundAction, { type: "settle" }> =>
      a.type === "settle" && a.person === self
  );
  if (settleForSelf) {
    return `定案：你 ${formatMinutes(settleForSelf.slot.start)}-${formatMinutes(settleForSelf.slot.end)}。`;
  }
  const proposeForSelf = actions.find(
    (a): a is Extract<OutboundAction, { type: "propose" }> =>
      a.type === "propose" && a.person === self
  );
  if (proposeForSelf) {
    return `关于厨房排班，先排你用 ${formatMinutes(proposeForSelf.slot.start)}-${formatMinutes(proposeForSelf.slot.end)}，这不是定案，愿意吗？`;
  }
  if (actions.some((a) => a.type === "remind" && a.person === self)) {
    return `还没收到你的做饭时间，方便报一下吗？`;
  }
  const blocked = actions.find(
    (a): a is Extract<OutboundAction, { type: "blocked" }> => a.type === "blocked"
  );
  if (blocked) {
    return `暂时排不开：${blocked.reasons[0].message}`;
  }
  return state === "gathering" ? `收到，我记下了。` : `收到。`;
}

export async function runColivingTurn(args: {
  /** 从哪个渠道来：sms / wecom / xhs。决定认人用哪种地址、回信走哪条路 */
  channel?: string;
  /** 该渠道里的发信人地址：短信是手机号，企业微信是 UserID */
  from: string;
  text: string;
  /** 仅测试用：临时覆盖模型，便于 A/B */
  modelId?: string;
}): Promise<TurnOutcome> {
  const channel = args.channel ?? "sms";
  /**
   * 这一轮开始的时刻。**批判器查"最近跟他之间的往来"时要用这个当截止线**——
   * 本轮自己发出去的消息，执行工具时就已经写进库了，审稿时如果不排除
   * 本轮自己刚写的，`recentOutbound` 会把这条消息自己算成"最近的往来"，
   * 判成"重复发送"（跟自己比对，当然一模一样）。
   *
   * **取数据库时钟，不取 node 时钟。** 竞态门禁（hasNewInboundSince）要拿
   * 它跟 `message.sent_at`（数据库 `now()` 生成）比大小，两个时钟不同源会
   * 差约 2.1s——把前一轮刚说过话的人误判成「本轮刚发来新消息」。
   */
  const turnStartedAt = await repo.dbNow();
  const sender = await repo.resolveSender(channel, args.from);

  /**
   * **本地脚本不许把伪造的消息写进真人住的房子。**
   * 我干过：伪造「我上周被裁了」测试，结果它成了用户的真实对话历史，
   * AI 之后带着这段编造的前情跟他说话。详见 guard.ts。
   * 放在这里是因为这是伪造入站消息的唯一入口。
   */
  if (sender) {
    assertCanWrite({
      isTestHousehold: sender.isTest,
      what: `跑一轮对话（${sender.householdLabel}）`,
    });
  }

  if (!sender) {
    return {
      reply: UNKNOWN_REPLY,
      // 硬编码文案，压根没过大脑，也就没有审稿这回事——当合格处理，
      // 不能让调用方误以为这是一条没验证过的模型输出。
      replyReview: { verified: true, pass: true, broke: "", why: "" },
      scheduleFacts: [],
      replyCommunicationId: null,
      outbound: [],
      allOutbound: [],
      decisionId: null,
      modules: [],
      promptChars: 0,
      toolsUsed: [],
      unknownSender: true,
      usage: {
        steps: 0,
        inputTokens: 0,
        cacheReadTokens: 0,
        cacheWriteTokens: 0,
        outputTokens: 0,
        costUsd: 0,
      },
      turnStartedAt,
    };
  }

  const conversationId = await repo.getOrCreateConversation({
    personId: sender.personId,
    householdId: sender.householdId,
    channel,
  });
  const history = await repo.getRecentTurns(conversationId);

  /**
   * coordination 实时旁路（shadow，默认关闭）：真实短信照常由下面现有 AI 流程
   * 处理并回复，这里只在后台用 coordination 状态机把这条消息跟一遍，结果只
   * `console.log` 打印，不改变 `reply`/`outbound`/任何生产返回值。只读位置，
   * 放在主生成/短路闸之前，避免影响下面正常流程。
   *
   * `COLIVING_COORDINATION_SHADOW=1` 才开（不设/不是 1 一律不跑）；可随时回滚。
   * `COLIVING_COORDINATION_SESSION_DIR` 可选，指定事件日志/checkpoint 落盘目录，
   * 缺省走 coordination-session 的默认临时目录。
   */
  if (process.env.COLIVING_COORDINATION_SHADOW === "1" && sender) {
    try {
      const members = await repo.getMembers(sender.householdId, channel);
      const participants = members.map((m) => m.name);
      const res = await advanceCoordinationSession(
        sender.householdId,
        sender.name,
        args.text,
        {
          window: kitchenEveningWindow(),
          participants,
          recentDialogue: history.map((h) =>
            h.role === "assistant" ? `AI：${h.content}` : h.content
          ),
          dir: process.env.COLIVING_COORDINATION_SESSION_DIR,
        }
      );
      console.log(
        "[coordination-shadow]",
        JSON.stringify({
          household: sender.householdLabel,
          sender: sender.name,
          text: args.text,
          state: res.state,
          actions: res.actions.map((a) => a.type),
        })
      );
    } catch (error) {
      console.log(
        "[coordination-shadow] 旁路失败（不影响生产）：",
        error instanceof Error ? error.message : String(error)
      );
    }
  }

  /**
   * 厨房排班替换分支（coordination 状态机接管，默认关闭、可随时回滚）。
   *
   * `COLIVING_COORDINATION_REPLACE=1` 才开（不设/不是 1 一律不跑，行为与旧流程完全
   * 一样）。命中厨房排班相关消息时，不再走下面「AI 硬撑排班」的整条链路，而是用
   * `maybeCoordinationReply` 推进 coordination 状态机、把状态机动作说成回复；它返回
   * 一个 `TurnOutcome` 就提前收工，返回 `null`（判不准/异常）就落回旧 AI 流程。
   * 放在 coordination shadow 旁路之后、主生成之前：不影响旧流程的既有判断与短路闸。
   * （本分支要不要命中依赖「正在回排班征询」，那个 answering 在 maybeCoordinationReply
   * 内部另取，不跟下方 pendingCommunication 的取用耦合。）
   */
  if (process.env.COLIVING_COORDINATION_REPLACE === "1" && sender) {
    const replaced = await maybeCoordinationReply({
      sender,
      channel,
      text: args.text,
      history,
      conversationId,
      turnStartedAt,
    });
    if (replaced) return replaced;
  }

  /**
   * 他这句多半是在回我们之前问的什么。**在轮次开始时就要知道**——
   * 这直接防住「明明问过、他也答了，下一轮又问一遍」那类 bug。
   * 事后关联（linkResponse）只是为了留档，防重复要靠这一步。
   */
  const answering = await repo.pendingCommunication(sender.personId);

  const modelId = args.modelId ?? colivingModelId();

  /**
   * 短路闸：住户以「愿意/行/可以」这类简单肯定，回复一条排班时段征询。
   *
   * 这种情况一开始就能确定回什么，不必跑模型。过去是等模型跑完、审稿
   * 重写之后才覆盖成短确认，于是住户回「愿意」时模型仍会白跑一轮、多花
   * 几十秒和一次带工具的模型往返（affirmation-short-reply 场景因此报
   * 「不该调用排班工具但调用了」）。这里在 buildContext 与主生成之前
   * 直接短路：生成短确认正文、做齐簿记、立刻返回。不调模型、不排班、
   * 不联系其他人。
   */
  if (isSimpleAffirmation(args.text) && isScheduleSlotInquiry(answering)) {
    const slot = answering ? extractSlotFromInquiry(answering.body) : null;
    const shortReply = slot
      ? `好，${slot} 就定给你了。`
      : `好，时段定了，按这个来。`;

    // 落库与正常回合一致：先把住户这句话作为入站消息写下，再 linkResponse
    // 把它关联回它正在回答的那条征询——这也是「谁确认过哪段」持久事实的
    // 来源（repo.listScheduleInquiryConfirmations 靠 response_message_id）。
    const inboundId = await repo.appendMessage({
      conversationId,
      personId: sender.personId,
      direction: "inbound",
      channel,
      body: args.text,
    });
    if (inboundId) {
      await repo.linkResponse({ personId: sender.personId, messageId: inboundId });
    }

    // 回复本身也算一次 communication：兜底记一条 reply_only 决策（与正常
    // ensureDecision("reply_only") 同语义），再把短确认作为回复落库。
    const shortDecisionId = await repo.recordDecision({
      householdId: sender.householdId,
      kind: "reply_only",
      intent: "简单肯定回复排班征询，代码短路落锤，未调用模型",
      modelId,
      doctrineModules: [],
      contextChars: 0,
      contextSnapshot: null,
    });
    const shortReplyCommunicationId = await repo.queueCommunication({
      householdId: sender.householdId,
      decisionId: shortDecisionId,
      caseId: null,
      toPersonId: sender.personId,
      channel,
      purpose: "回复本人",
      body: shortReply,
    });
    await repo.appendMessage({
      conversationId,
      personId: sender.personId,
      direction: "outbound",
      channel,
      body: shortReply,
      communicationId: shortReplyCommunicationId,
    });

    return {
      reply: shortReply,
      replyReview: { verified: true, pass: true, broke: "", why: "" },
      scheduleFacts: [],
      replyCommunicationId: shortReplyCommunicationId,
      outbound: [],
      allOutbound: [],
      decisionId: shortDecisionId,
      modules: [],
      promptChars: 0,
      toolsUsed: [],
      unknownSender: false,
      usage: {
        steps: 0,
        inputTokens: 0,
        cacheReadTokens: 0,
        cacheWriteTokens: 0,
        outputTokens: 0,
        costUsd: 0,
      },
      turnStartedAt,
    };
  }

  // 「刚进来」= 这条会话线上还没有过任何来往。比记一个标志位可靠：
  // 不管他是自己发来的第一条，还是回复我们主动发的第一条，都算。
  const ctx = await buildContext(sender, channel, {
    justJoined: history.length === 0,
    answering,
  });

  /**
   * 本屋近期住户对排班征询回过**简单肯定**的持久事实（复用 communication 的
   * responded 状态，见 repo.listScheduleInquiryConfirmations）。这是"谁已确认
   * 过哪段"的单一事实源：contactPerson 排班分支用它跳过「已确认该时段」的人，
   * missingSelectedScheduleParticipants 也把这些人视为已处理。
   *
   * 只按 slot（start/end）精确相等匹配——被算法挪过时段的人要重新征询，不命中；
   * 72h 窗口由查询兜着，跨协调段的旧确认不会误伤。
   */
  const confirmedScheduleSlots = new Map<
    string,
    Array<{ windowLabel: string | null; start: string; end: string }>
  >();
  for (const row of await repo.listScheduleInquiryConfirmations(sender.householdId)) {
    const parsed = scheduleInquiryConfirmation(row);
    if (!parsed) continue;
    const list = confirmedScheduleSlots.get(row.personId);
    if (list) list.push(parsed);
    else confirmedScheduleSlots.set(row.personId, [parsed]);
  }
  const hasDurableConfirmedSlot = (
    personId: string,
    slot: { start: string; end: string }
  ): boolean =>
    (confirmedScheduleSlots.get(personId) ?? []).some(
      (c) => c.start === slot.start && c.end === slot.end
    );

  /**
   * 关键词永远会有漏网的（真实投诉说的是"做饭""挨饿""不公平"，
   * 不是"厨房""室友""吵"）。**提到同住人的名字，几乎必然是人际问题**——
   * 这个信号比任何词表都可靠，而名册本来就在手上。
   */
  const mentionsOther = ctx.members.some(
    (m) => m.personId !== sender.personId && args.text.includes(m.name)
  );
  const hasOpenConflictCase = ctx.openCases.some(isOpenConflictCase);
  // 结构信号交给路由引擎（router.ts 的 when 条件）判断要不要加载 conflict，
  // 不再手动构造 forcedModules——路由规则与装载理由只留在 brain 一处。
  const signals = {
    mentionsOther,
    hasOpenConflictCase,
  };

  const { doctrine, runtime, loadedModuleIds, chars } = assembleSystemPrompt({
    brainId: "coliving",
    routeOn: args.text,
    runtimeContext: ctx.text,
    // 结构信号：名册提到其他住户，或存在未结冲突——比本轮关键词更可靠的路由依据。
    signals,
  });
  const conflictContextActive =
    hasOpenConflictCase || loadedModuleIds.includes("conflict");

  // ── 本轮累积的状态 ──
  let decisionId: string | null = null;
  let activeCaseId: string | null = null;
  let activeRuleId: string | null = null;
  let lastEventId: string | null = null;
  const outbound: OutboundMessage[] = [];
  const toolsUsed: string[] = [];
  const contacted = new Set<string>();
  /** 跨轮已问过且还没回的人：算作已征询，但不能再发一遍同文短信。 */
  const recentlyCovered = new Map<string, { name: string; communicationId: string }>();
  /**
   * 每次调用 `pickSchedule` 真正算出来的排第一候选，原样记下来。
   *
   * 起因（2026-09-04 真实事故复测发现）：`pickSchedule` 算法本身没有
   * 拆分连续时段的逻辑（每个人必然分到一段连续区间），但真实跑批时
   * 出现过"把一个人连续两小时拆成两段、中间空半小时"这种荒谬结果——
   * 说明不是算法算错了，是**模型调完工具、拿到正确答案之后，写消息
   * 时没有照抄工具返回的数字，自己心算/瞎编了一版**。而批判器当时
   * `baseFacts` 里只有"本轮调用的工具：pickSchedule、contactPerson…"
   * 这样一份工具名单，**看不到 pickSchedule 到底算出了什么**，没法
   * 拿草稿里写的时段跟工具的真实返回值核对，只能凭常识判断"这个结果
   * 看着对不对"——常识判断能抓到"拆两段不合理"这种明显问题，但抓不到
   * "工具说的是A，消息却写了B"这种更隐蔽的不一致。这里把工具真实
   * 算出的候选摆进 `baseFacts`，批判器就能做那种更精确的核对。
   */
  const scheduleResults: string[] = [];
  /** `pickSchedule` 按窗口名存下真实候选，供 `chooseSchedule` 核对编号合法性。 */
  const scheduleCandidatesByLabel = new Map<string, ReturnType<typeof bestSchedulePlans>>();
  /**
   * 这一轮已经拍板要用的方案，按窗口名存。**这是跨消息一致性的唯一
   * 依据**——`contactPerson` 给参与者发排班消息时，代码拿这里的时段
   * 跟它填的 `scheduleSlot` 做结构化比对（字符串相等，不猜语义），
   * 对不上直接拒绝执行，不静默发出去。
   *
   * 起因（2026-09-06 真实复现）：`pickSchedule` 一次给 5 个候选，模型
   * 分别给两个人发 `contactPerson` 时各自"心算"了一遍要用哪个候选，
   * 两条消息拼出来的时段来自不同候选，回复又用了第三套组合——批判器
   * 三条全拦，因为没有任何单一候选能同时解释这三条消息。根治靠"选定"
   * 这一步：选完之后所有消息只认这一个方案，不再各自去猜。
   */
  const selectedSchedules = new Map<string, ScheduleSelection>();
  /**
   * 按窗口名 → 人名，存自报精确时段的 start/end（HH:MM）。
   * 只有 selectedSchedule 里该人的 start/end 与这里完全相等，才视为预先同意。
   * 算法因约束挪位后时段不同，不命中，仍走正常征询。
   */
  const selfStatedSlotsByWindow = new Map<string, Map<string, { start: string; end: string }>>();
  /**
   * 本轮已确认为”预先同意”的人（自报时段与选定完全一致）。
   * `checkUnconsultedSelectedSchedule` 用它把这些人视为已征询，
   * 不强迫模型再发一遍消息。对发起人的汇报不得谎称”已联系”这些人。
   */
  const preConsentedForSchedule = new Set<string>();
  /** 只在本轮 pickSchedule 明确返回无候选时成立；口头说”排不开”不算证据。 */
  let scheduleProvenInfeasible = false;
  /**
   * 这一轮里新加进来、这轮之前压根不存在的人。**批判器的四种角色
   * （报告的人/被说到的人/共用者通知的对象/受影响的其他人）全都假定
   * 这条消息跟一件具体纠纷有关**——但刚加进来打招呼跟纠纷毫无关系，
   * 硬套"被说到的人"会把中性的自我介绍当成指控来审，见下面
   * critique 那段的说明。
   */
  const newlyAdded = new Map<string, string>();

  /** 没调 decide 就直接说话时，兜底补一条，保证链路完整（设计稿第十四点） */
  const ensureDecision = async (
    kind: string,
    intent?: string | null
  ): Promise<string> => {
    if (!decisionId) {
      decisionId = await repo.recordDecision({
        householdId: sender.householdId,
        kind,
        // 兜底记录也别留空。像 contactPerson 那样，调用方手里往往已经有
        // purpose 这类描述——之前没传，实测跑出过一条 intent/rationale
        // 全 null 的 decision，审计的时候看不出这轮到底在干什么。
        intent: intent ?? null,
        modelId,
        doctrineModules: loadedModuleIds,
        contextChars: chars,
        contextSnapshot: ctx.text,
      });
    }
    return decisionId;
  };

  /** 模型显式交付的正文。调了 sendReply 就以它为准，不再猜哪段自由文本是正文。 */
  let deliveredReply: string | null = null;

  /**
   * **排班征询的唯一入队函数（contactPerson 排班分支与最终自动收口共用）。**
   *
   * 选定多人排班后，"逐个向每个参与者征询到位"这件必须可靠发生的事，由代码
   * 确定性完成，不再寄托模型记得调用 contactPerson——Codex 全量回归（多模型
   * 多轮）证明：模型在单轮里既要 pickSchedule → chooseSchedule → 逐个
   * contactPerson → sendReply，经常漏掉一个或几个参与者；checkUnconsulted
   * 打回后重写仍漏。把"找到目标人 → 预同意/已确认同一 slot/无地址/本轮已联系/
   * 24h 同文未回/竞态新入站这些跳过 → 生成征询正文 → 落库入队、写进对方会话线、
   * 收进本轮出站并标 scheduleVerified"整套逻辑收进这一个函数，两个调用方不各写
   * 一份，杜绝逻辑漂移。
   *
   * 函数只负责"可靠入队"这一件事，不替大脑决定要不要发、怎么措辞：正文一律
   * `scheduleContactTextForAct` 的征询模板（act 固定 propose、expectsReply=true
   * ——排班征询永远在等对方回音，模型填的 act 不可靠，不能让它落成 inform）。
   */
  async function enqueueScheduleContact(
    name: string,
    windowLabel: string,
    slot: { start: string; end: string }
  ): Promise<
    | { ok: true; sentTo: string; skipped: false }
    | {
        ok: true;
        skipped: true;
        preConsented?: boolean;
        reason: string;
        communicationId?: string;
        sentTo?: string;
      }
    | { ok: false; reason: string; stale?: boolean }
  > {
    // enqueueScheduleContact 是提升函数声明，runColivingTurn 入口 `if (!sender)
    // return` 的收窄不会带进函数体，TS 于是把 sender 当可空。但唯一能走到这里
    // 的两条路（contactPerson 排班分支、最终自动收口）都在入口早退之后，sender
    // 必非空——这里防御性断言一次，同时满足类型收窄，不引入运行时分支。
    if (!sender) {
      return { ok: false, reason: "内部状态错误：没有说话人" };
    }
    const target = await repo.findPersonByName(sender.householdId, name);
    if (!target) {
      return { ok: false, reason: `房子里没有叫「${name}」的人` };
    }
    const selfStatedEntry = selfStatedSlotsByWindow.get(windowLabel)?.get(name);
    // slot 参数在 contactPerson 语境里就叫 scheduleSlot，别名保持一致方便对照。
    const scheduleSlot = slot;
    if (scheduleSlotMatchesSelfStatement(selfStatedEntry, scheduleSlot)) {
      // 预先同意：不创建 communication、不 appendMessage、不进 outbound、不进 contacted。
      // 门禁通过 preConsentedForSchedule 把这个人视为已授权，不再要求额外联系。
      preConsentedForSchedule.add(target.personId);
      return {
        ok: true,
        preConsented: true,
        skipped: true,
        reason: `${name} 在对话里已明确说出这个精确时段，原话视作许可，不再发征询`,
      };
    }
    if (hasDurableConfirmedSlot(target.personId, scheduleSlot)) {
      preConsentedForSchedule.add(target.personId);
      return {
        ok: true,
        preConsented: true,
        skipped: true,
        reason: `${name} 之前已确认过 ${scheduleSlot.start}-${scheduleSlot.end} 这个时段，定案/通知不再重复发送`,
      };
    }
    if (target.personId === sender.personId) {
      return {
        ok: false,
        reason: "这是当前跟你说话的人，直接回复就行，不用另外发",
      };
    }
    if (!target.address) {
      return {
        ok: false,
        reason: `${target.name} 在这个渠道没有登记地址，联系不上`,
      };
    }
    if (contacted.has(target.personId)) {
      return { ok: false, reason: `本轮已经给 ${target.name} 发过了` };
    }
    // 正文由固定模板生成，避免模型把一次建议写成"定案"，或在自然语言里重新心算错时间。
    const message = scheduleContactTextForAct({
      act: "propose",
      salutation: isGeneratedResidentName(target.name) ? "" : `${target.name}，`,
      windowLabel,
      scheduleSlot,
    });
    const purpose = `为「${windowLabel}」排班征询${target.name}`;
    const duplicate = await repo.findRecentOpenCommunication({
      toPersonId: target.personId,
      channel,
      body: message,
    });
    if (duplicate) {
      recentlyCovered.set(target.personId, {
        name: target.name,
        communicationId: duplicate.id,
      });
      return {
        ok: true,
        skipped: true,
        reason:
          `近24小时已经给 ${target.name} 发过同一条，且对方还没回复；` +
          "这次不重复发送。",
        communicationId: duplicate.id,
        sentTo: target.name,
      };
    }
    /**
     * **竞态门禁：上下文已过期就跳过，不冒充已联系。** 真实事故见 contactPerson
     * 历史注释（01:51 发征询、01:53 对方已回愿意，并发旧回合又发一遍）。工具
     * 执行时重新查目标人自 turnStartedAt 之后有无新入站；有就跳过。
     */
    const targetHasNewInbound = await repo.hasNewInboundSince(
      target.personId,
      channel,
      turnStartedAt
    );
    if (targetHasNewInbound) {
      return {
        ok: false,
        stale: true,
        reason:
          `${target.name} 在本轮开始后已经发来新消息，上下文已过期；` +
          "这条征询跳过，不会发出，也不计入已联系——下一轮拿到最新上下文再处理。",
      };
    }
    contacted.add(target.personId);
    const did = await ensureDecision("contact_one", purpose);
    // 模型常先说「只回复本人」，转头又来联系别人。判断记录要跟实际行为对得上。
    await repo.upgradeDecisionKind(
      did,
      contacted.size > 1 ? "contact_group" : "contact_one"
    );
    const communicationId = await repo.queueCommunication({
      householdId: sender.householdId,
      decisionId: did,
      caseId: activeCaseId,
      toPersonId: target.personId,
      channel,
      purpose,
      body: message,
      // 排班征询永远是 propose、永远等回音：act 字段不可靠，不能让它把
      // "在等对方确认"记成 inform 而不再盯回音（见 scheduleContactTextForAct）。
      act: "propose",
      expectsReply: true,
    });
    // 也要写进对方自己的会话线。否则下次他发消息过来，
    // 我们看不到自己曾经对他说过什么——他却记得。
    const theirConversation = await repo.getOrCreateConversation({
      personId: target.personId,
      householdId: sender.householdId,
      channel,
    });
    await repo.appendMessage({
      conversationId: theirConversation,
      personId: target.personId,
      direction: "outbound",
      channel,
      body: message,
      communicationId,
    });
    outbound.push({
      to: target.address,
      personId: target.personId,
      text: message,
      communicationId,
      sharedRule: false,
      sharedWith: null,
      isIntroduction: newlyAdded.has(target.personId),
      // 结构化排班正文：审稿按 scheduleVerified 直接放行（见
      // critiqueAndMarkOutbound），不再交给语言批判器反向误判数字。
      scheduleVerified: true,
    });
    return { ok: true, sentTo: target.name, skipped: false };
  }

  const tools = {
    /**
     * **最后一步调这个，把要发给对方的短信正文交出来。**
     *
     * 为什么不直接用模型的自由文本：不同模型在工具调用之间写的东西不一样——
     * 有的在续写正文（只取最后一步会截断），有的在写给自己看的计划
     * （全部拼起来会把「Reply to 小李 now — must contain his own portion」
     * 这种自言自语发给住户，真实发生过）。**靠猜哪段是正文不可靠，
     * 让它显式交付。**
     */
    sendReply: tool({
      description:
        "本轮最后一步：把要回给当前这个人的短信正文交出来，调完就结束。" +
        "只放真正要发的话，不放思考过程或给别人的那条（那个用 contactPerson）。",
      inputSchema: z.object({
        text: z
          .string()
          .describe("短信正文。短、具体、纯文本，不要 markdown 符号"),
      }),
      execute: async ({ text }) => {
        /**
         * **代码级拦一道，不只靠提示词那句"不要放思考过程"。**
         *
         * 真实事故（黑客级并行测试抓到，2026-09-05）：一轮里既要回复
         * 当前这个人、又要用 `contactPerson` 联系别人时，模型把路由
         * 思考直接当成了 `sendReply` 的正文——真实出现过两次：
         * 「（这条不要发出去，只是确认给另一位的那条这次真正发出）」、
         * 「（这条发住客A，本轮不面向他）」。这不是"没调 sendReply、
         * 退回自由文本"那条老路径（那条已经有安全网），是**模型明确
         * 调用了 sendReply，参数就是这段内部批注**——提示词里"不要放
         * 思考过程"这句话没能拦住。
         *
         * 两次真实泄漏的文字有同一个干净的结构特征：**整条消息被一对
         * 括号从头到尾包住**——这在真实要发给住户的短信里几乎不会
         * 出现，是"内部批注"的清晰信号，用它做校验比猜测语义关键词
         * 更可靠。命中就拒绝这次交付，让模型在同一轮里重新说清楚
         * 真正要发的话，不是静默放行一条不该被人看到的内部笔记。
         */
        const trimmed = text.trim();
        const fullyParenthesized =
          (trimmed.startsWith("（") && trimmed.endsWith("）")) ||
          (trimmed.startsWith("(") && trimmed.endsWith(")"));
        if (fullyParenthesized) {
          return {
            ok: false,
            reason:
              "这条整体被括号包住，读起来像是你写给自己看的内部批注" +
              "（比如「这条不要发出去」「这条发给谁」这类），不是真正要" +
              "发给对方的短信正文。重新想一句要发出去的话，不要用括号" +
              "包住整句。",
          };
        }
        deliveredReply = text;
        return { ok: true };
      },
    }),

    decide: tool({
      description:
        "每轮必调：记下你这次的治理判断（要不要介入、找谁、想达成什么、为什么）。" +
        "判断与说出口的话分开记录。可与 logEvent 同一轮并发调，" +
        "同一件事的 caseId 两个工具各自填，不共享状态。",
      inputSchema: z.object({
        kind: z
          .enum([
            "observe",
            "stay_silent",
            "log_only",
            "reply_only",
            "contact_one",
            "contact_group",
            "propose_rule",
            "escalate",
          ])
          .describe(
            "observe=继续观察不动作 · stay_silent=这次不该说话 · log_only=只记录 · " +
              "reply_only=只回复当前这个人 · contact_one=还要私下联系某一个人 · " +
              "contact_group=要分别联系多个人 · propose_rule=要定一条规则 · escalate=要转给房东"
          ),
        intent: z.string().describe("这次想达成什么，一句话"),
        rationale: z.string().describe("为什么这么判断"),
        caseId: z
          .string()
          .optional()
          .describe(
            "某件未了结事情的后续就填它的 id。同时调了 logEvent 也在那边" +
              "单独填同一个 id——两个工具并发，谁先跑完不确定，不共享状态。"
          ),
      }),
      execute: async ({ kind, intent, rationale, caseId }) => {
        // 模型会编 id。编的 id 插 communication 时会撞外键、整轮崩掉，
        // 而 touchCase 更新零行是不报错的——所以必须先验存在。
        if (caseId && (await repo.caseExists(sender.householdId, caseId))) {
          activeCaseId = caseId;
          await repo.touchCase(caseId);
        }
        decisionId = await repo.recordDecision({
          householdId: sender.householdId,
          caseId: activeCaseId,
          kind,
          intent,
          rationale,
          modelId,
          doctrineModules: loadedModuleIds,
          contextChars: chars,
        });
        // 模型很爱在回复里写「我会跟他说」，然后这一轮就结束了，
        // 对方永远收不到。判断说要联系人，就得在同一轮里真的联系到。
        const mustContact = kind === "contact_one" || kind === "contact_group";
        return {
          ok: true,
          decisionId,
          next: mustContact
            ? "你判断了要联系别人。**现在就用 contactPerson 逐个联系到**——" +
              "只在回复里写「我会跟他说」而不调工具，那条消息永远发不出去。"
            : undefined,
        };
      },
    }),

    logEvent: tool({
      description:
        "记录发生的一件事；判断为无需处理时也要记，理由写进 detail（不作为" +
        "同样要被复核）。需持续跟进就 openCase=true；是某件未了结事的后续" +
        "就填 caseId——与 decide 并发、状态不共享，两边各自填。",
      inputSchema: z.object({
        kind: z
          .string()
          .describe(
            "事件类别，用小写下划线：noise_complaint / kitchen_contention / " +
              "repair_request / rent_late / smell_complaint / safety_concern 等"
          ),
        severity: z
          .enum(["P0", "P1", "P2", "P3"])
          .describe(
            "P0=人身安全/火灾燃气/居住功能全失，P1=居住条件失效/非法进入/盗窃/骚扰，" +
              "P2=持续性生活摩擦，P3=早期信号需观察"
          ),
        summary: z.string().describe("一句话说清发生了什么"),
        detail: z.string().optional().describe("依据、各方陈述、你的判断理由"),
        aboutNames: z
          .array(z.string())
          .optional()
          .describe("这件事说的是谁（房子里的人名）"),
        caseId: z
          .string()
          .optional()
          .describe(
            "「还没了结的事」里某条的后续就填它的 id——与 decide 同 id，这边单独填。"
          ),
        openCase: z
          .boolean()
          .optional()
          .describe("全新且需持续跟进才 true；有 caseId 就不要设"),
        caseTitle: z.string().optional().describe("openCase 时给它起个短标题"),
      }),
      execute: async (a) => {
        const aboutIds: string[] = [];
        for (const n of a.aboutNames ?? []) {
          const m = await repo.findPersonByName(sender.householdId, n);
          if (m) {
            aboutIds.push(m.personId);
          }
        }
        // 显式传入的 caseId 优先于共享变量：decide 那边即使这轮也在填，
        // 并发执行下谁先落地不确定，不能靠"对方应该已经设好了"。
        if (
          a.caseId &&
          !activeCaseId &&
          (await repo.caseExists(sender.householdId, a.caseId))
        ) {
          activeCaseId = a.caseId;
          await repo.touchCase(a.caseId);
        }
        if (a.openCase && !activeCaseId) {
          activeCaseId = await repo.openCase({
            householdId: sender.householdId,
            kind: a.kind,
            title: a.caseTitle ?? a.summary.slice(0, 80),
            severity: a.severity,
          });
        }
        lastEventId = await repo.recordEvent({
          householdId: sender.householdId,
          kind: a.kind,
          summary: a.summary,
          detail: a.detail ?? null,
          severity: a.severity,
          reportedBy: sender.personId,
          aboutPersonIds: aboutIds,
          caseId: activeCaseId,
        });
        return { ok: true, eventId: lastEventId, caseId: activeCaseId };
      },
    }),

    /**
     * 杠杆二。以前 AI 只能对着投诉人一个人把三个人的事定了，
     * 于是要么反复追问、要么替所有人拍板。现在它可以分别去说。
     */
    contactPerson: tool({
      description:
        "主动给这栋房子里的另一个人发消息（非回复当前这位）。这是你按流程做的" +
        "判断，不是征求当前这位同意。**不得透露是谁反映的**，除非那人明确说可以；" +
        "对被投诉一方先按中立提醒说，不要上来就指控。",
      inputSchema: z.object({
        name: z.string().describe("要联系的人的名字，必须是房子里现有的人"),
        purpose: z
          .string()
          .describe("这条消息的目的，例如：告知新的厨房时段安排"),
        scope: z
          .enum(["personal", "shared"])
          .describe(
            "personal=针对他个人的事；shared=对同样的人都一样的规矩。" +
              "说规矩就填 shared，否则对方读成针对他一个人。"
          ),
        sharedWith: z
          .string()
          .optional()
          .describe("填 shared 时写清这条对哪些人一样（人名）"),
        message: z
          .string()
          .describe(
            "真正要发出去的短信正文。短、具体、直接说事。不提是谁反映的。"
          ),
        act: z
          .enum(["ask", "inform", "propose", "confirm", "remind", "escalate"])
          .describe(
            "这条在干什么（系统据此决定是否盯着他回音）：ask=问问题等他答 · " +
              "inform=告知不用回 · propose=提方案征求意见 · " +
              "confirm=请他确认（事关钱/时间/权利）· remind=催上次说的 · " +
              "escalate=转房东。该等的填成 inform 会让事情无人跟进。"
          ),
        scheduleWindowLabel: z
          .string()
          .optional()
          .describe(
            "排班消息里填：与 `chooseSchedule` 同一个窗口名。填了就必须也填 " +
              "`scheduleSlot`；代码核对与已选方案该人时段完全一致，不一致拒绝执行。"
          ),
        scheduleSlot: z
          .object({
            start: z
              .string()
              .regex(HH_MM_PATTERN)
              .describe("这条消息里告诉他的开始时间，HH:MM"),
            end: z
              .string()
              .regex(HH_MM_PATTERN)
              .describe("这条消息里告诉他的结束时间，HH:MM"),
          })
          .optional()
          .describe("跟 scheduleWindowLabel 一起填。不用在这条消息里重复解释全案，代码只核对数字对不对。"),
      }),
      execute: async ({
        name,
        purpose,
        scope,
        sharedWith,
        act,
        message: raw,
        scheduleWindowLabel,
        scheduleSlot,
      }) => {
        let message = stripMarkdown(raw);
        let scheduleVerified = false;
        const target = await repo.findPersonByName(sender.householdId, name);
        if (!target) {
          return { ok: false, reason: `房子里没有叫「${name}」的人` };
        }
        // 本轮已为这个参与者计算排班时，联系必须绑定到选定候选。
        // 不靠正文时间格式判断（“六点半”等中文写法会绕过）；无关事项拆到
        // 下一轮处理，换取同一轮排班绝不跨候选拼接的确定性。
        const relevantWindows = [...scheduleCandidatesByLabel.entries()]
          .filter(([, candidates]) =>
            candidates.some((candidate) =>
              candidate.assignments.some((assignment) => assignment.name === name)
            )
          )
          .map(([label]) => label);
        if (relevantWindows.length > 0 && !scheduleWindowLabel && !scheduleSlot) {
          const selected = relevantWindows.find((label) => selectedSchedules.has(label));
          return {
            ok: false,
            reason: selected
              ? `这轮已为${name}选定「${selected}」方案；必须填写 scheduleWindowLabel 和 scheduleSlot，代码才能核对同一候选`
              : `这轮已为${name}算过排班；先用 chooseSchedule 选定一个候选，再带 scheduleWindowLabel 和 scheduleSlot 联系`,
          };
        }
        /**
         * **结构化核对，不猜正文里的数字。** 真实事故：同一轮里给两个人
         * 分别发排班消息，各自"心算"了一遍要用哪个候选，两条消息拼出来
         * 的时段来自不同候选，回复又用了第三套——批判器只能挨条拦，
         * 因为没有单一候选能同时解释三条消息。选定之后用这两个参数核对，
         * 对不上直接拒绝执行，不进 outbound、不占用这轮对这个人的联系名额。
         */
        if (scheduleWindowLabel || scheduleSlot) {
          if (!scheduleWindowLabel || !scheduleSlot) {
            return { ok: false, reason: "scheduleWindowLabel 和 scheduleSlot 必须一起填" };
          }
          const selected = selectedSchedules.get(scheduleWindowLabel);
          if (!selected) {
            return {
              ok: false,
              reason: `「${scheduleWindowLabel}」还没有用 chooseSchedule 选定方案，先选定再联系人`,
            };
          }
          const consistency = checkScheduleSlotConsistency(selected, name, scheduleSlot);
          if (!consistency.ok) {
            return { ok: false, reason: `${consistency.reason}。改成一致的时段再发，不能私自改动已选方案。` };
          }
          // 排班分支交给 enqueueScheduleContact——与最终自动收口共用同一个
          // 入队函数，不在这里复制一份发送逻辑：找目标人、自报精确时段/已确认
          // 同一 slot 的预同意跳过、无地址/重复/竞态闸，以及 queueCommunication
          // + appendMessage + 入 outbound（scheduleVerified:true）全收在里面；
          // 正文由 scheduleContactTextForAct 固定生成（act 一律 propose、永远
          // expectsReply=true），不在这里按模型 act 分支。
          return enqueueScheduleContact(name, scheduleWindowLabel, scheduleSlot);
        }
        if (target.personId === sender.personId) {
          return {
            ok: false,
            reason: "这是当前跟你说话的人，直接回复就行，不用另外发",
          };
        }
        if (!target.address) {
          return {
            ok: false,
            reason: `${target.name} 在这个渠道没有登记地址，联系不上`,
          };
        }
        if (contacted.has(target.personId)) {
          return { ok: false, reason: `本轮已经给 ${target.name} 发过了` };
        }
        const duplicate = await repo.findRecentOpenCommunication({
          toPersonId: target.personId,
          channel,
          body: message,
        });
        if (duplicate) {
          recentlyCovered.set(target.personId, {
            name: target.name,
            communicationId: duplicate.id,
          });
          return {
            ok: true,
            skipped: true,
            reason:
              `近24小时已经给 ${target.name} 发过同一条，且对方还没回复；` +
              "这次不重复发送。",
            communicationId: duplicate.id,
            sentTo: target.name,
          };
        }
        /**
         * **竞态门禁：上下文已过期就跳过，不冒充已联系。**
         *
         * 真实事故（生产日志，2026-09-06）：01:51:27 发出征询，01:53:46 对方
         * 已回复"愿意"，系统随即正确落锤——但另一个较早开始的并发回合上下文
         * 在 01:53:54 才执行 contactPerson，01:53:59 又发出同一个"你愿意吗"。
         * 旧回合的 decision 在 01:53:51 落库，rationale 还称对方"尚未表态"，
         * 说明模型思考期间库里已有新入站，但 contactPerson 按旧上下文继续执行。
         *
         * 修法：工具执行时重新查目标人自 turnStartedAt 之后有无新入站；有就跳过。
         * 不标 ok:false（那样模型会以为失败，可能换措辞重试）；也不加进 outbound
         * （不能让后续检查把"已跳过"当成"已联系"）——直接返回 ok:false 并说清
         * 原因，让模型知道这条不需要重发、状态没有改变。
         *
         * 设计通用：不针对厨房或排班，任何 contactPerson 在目标有新消息时都跳过。
         */
        const targetHasNewInbound = await repo.hasNewInboundSince(
          target.personId,
          channel,
          turnStartedAt
        );
        if (targetHasNewInbound) {
          return {
            ok: false,
            stale: true,
            reason:
              `${target.name} 在本轮开始后已经发来新消息，上下文已过期；` +
              "这条征询跳过，不会发出，也不计入已联系——下一轮拿到最新上下文再处理。",
          };
        }
        contacted.add(target.personId);

        const did = await ensureDecision("contact_one", purpose);
        // 模型常先说「只回复本人」，转头又来联系别人。判断记录要跟实际行为对得上。
        await repo.upgradeDecisionKind(
          did,
          contacted.size > 1 ? "contact_group" : "contact_one"
        );
        const communicationId = await repo.queueCommunication({
          householdId: sender.householdId,
          decisionId: did,
          caseId: activeCaseId,
          toPersonId: target.personId,
          channel,
          purpose,
          body: message,
          act,
          // ask/propose/confirm 都是把球踢给对方、等他回；
          // inform/remind/escalate 不占用"在等谁"这份清单
          expectsReply: act === "ask" || act === "propose" || act === "confirm",
        });
        // 也要写进对方自己的会话线。否则下次他发消息过来，
        // 我们看不到自己曾经对他说过什么——他却记得。
        const theirConversation = await repo.getOrCreateConversation({
          personId: target.personId,
          householdId: sender.householdId,
          channel,
        });
        await repo.appendMessage({
          conversationId: theirConversation,
          personId: target.personId,
          direction: "outbound",
          channel,
          body: message,
          communicationId,
        });

        outbound.push({
          to: target.address,
          personId: target.personId,
          text: message,
          communicationId,
          sharedRule: scope === "shared",
          sharedWith: sharedWith ?? null,
          isIntroduction: newlyAdded.has(target.personId),
          scheduleVerified,
        });
        return { ok: true, sentTo: target.name };
      },
    }),

    proposeRule: tool({
      description:
        "把共同生活的安排记成规则（时段/分工/访客等）。规则不是你和房东单方" +
        "定的，是住在这里的人一起定的。你给默认方案并先照执行，然后逐个私信" +
        "住在这里的人（contactPerson），用 recordStance 记谁同意/谁异议；全问过才算成立。",
      inputSchema: z.object({
        kind: z
          .string()
          .describe("quiet_hours / kitchen_schedule / trash / guests / cleaning 等"),
        statement: z.string().describe("一句话说清这条规则，含具体钟点和人名"),
        agreedByNames: z
          .array(z.string())
          .optional()
          .describe("此刻已经明确说过同意的人。没人确认过就留空"),
      }),
      execute: async ({ kind, statement, agreedByNames }) => {
        const agreed: string[] = [];
        for (const n of agreedByNames ?? []) {
          const m = await repo.findPersonByName(sender.householdId, n);
          if (m) {
            agreed.push(m.personId);
          }
        }
        const ruleId = await repo.saveRule({
          householdId: sender.householdId,
          kind,
          statement,
          agreedBy: agreed,
          sourceCaseId: activeCaseId,
        });
        activeRuleId = ruleId;
        const residents = ctx.members.filter((m) => m.resides);
        return {
          ok: true,
          ruleId,
          note:
            `这条规则要问过这 ${residents.length} 个住在这里的人才算成立：` +
            `${residents.map((m) => m.name).join("、")}。` +
            "还没问的，用 contactPerson 去问。",
        };
      },
    }),

    recordStance: tool({
      description:
        "记某人对一条共同规则的态度。**只在对方真表过态时记**——没回复不等于同意，" +
        "那是「问过还没答」，用 asked。之前同意过的人现在说这条不合适/不公平，" +
        "就是在表异议，立刻记 objected，不用等你问完细节、想好新方案再记。",
      inputSchema: z.object({
        name: z.string(),
        stance: z
          .enum(["asked", "agreed", "objected"])
          .describe("asked=问过了还没答 · agreed=明确说行 · objected=提了异议"),
        ruleId: z.string().optional().describe("不填就用本轮刚提的那条"),
      }),
      execute: async ({ name, stance, ruleId }) => {
        const target = ruleId ?? activeRuleId;
        if (!target) {
          return { ok: false, reason: "本轮没有正在征询的规则" };
        }
        const m = await repo.findPersonByName(sender.householdId, name);
        if (!m) {
          return { ok: false, reason: `房子里没有叫「${name}」的人` };
        }
        await repo.recordConsultation({
          ruleId: target,
          personId: m.personId,
          stance,
        });
        // 齐了就自动收口。**不靠模型判断**——它会一直以为还没问全。
        // **齐了不等于都同意**：有异议也会走到这一步，提示语要分开说，
        // 不能不管有没有异议都说"定下来了"（第15轮踩过：一个人同意都
        // 没有、只有一条异议，也曾经被这么告诉模型）。
        const { done, objectedCount } = await repo.closeConsultationIfComplete(
          target
        );
        return {
          ok: true,
          note: done
            ? objectedCount > 0
              ? "所有人都表过态了，**但有人不同意**，这条规则还没定下来——" +
                "根据异议调整方案，再走一轮征询，不要当成已成立说出去。"
              : "所有人都表过态了，**这条规则已经定下来**。不用再问任何人，" +
                "把最终结果告诉大家就行。"
            : undefined,
        };
      },
    }),

    notePartyAffected: tool({
      description:
        "标记某个人被这件事影响到，即使他还没开口表过态——被牵扯到、方案会改到" +
        "他作息的人也算。与 recordPosition 不同：那个记「说过什么」，这个记" +
        "「利害关系」。结案时按这份名单核对是否人人知情。",
      inputSchema: z.object({
        caseId: z.string().describe("上下文里那一栏给的 id"),
        name: z.string().describe("被影响到的人"),
        reason: z.string().optional().describe("为什么算他一个，一句话"),
      }),
      execute: async ({ caseId, name, reason }) => {
        if (!(await repo.caseExists(sender.householdId, caseId))) {
          return { ok: false, reason: "没有这件事，别编 id" };
        }
        const m = await repo.findPersonByName(sender.householdId, name);
        if (!m) {
          return { ok: false, reason: `房子里没有叫「${name}」的人` };
        }
        await repo.addCaseParty({
          caseId,
          householdId: sender.householdId,
          personId: m.personId,
          reason: reason ?? null,
        });
        return { ok: true };
      },
    }),

    pickSchedule: tool({
      description:
        "为多人连续使用同一资源计算排班——不要心算，数字全由代码算。硬约束" +
        "不突破，软偏好只用于比公平负担。算完立刻调 chooseSchedule 选候选1；" +
        "有人补充限制/不同意就更新 people 重算。",
      inputSchema: z.object({
        windowLabel: z.string().describe("这段窗口叫什么，比如「傍晚厨房时段」"),
        windowStart: z
          .string()
          .regex(HH_MM_PATTERN)
          .describe("窗口起点，HH:MM 格式，比如「18:00」"),
        people: z
          .array(
            z.object({
              name: z.string().describe("这个人的名字"),
              durationMinutes: z.number().int().positive().describe("需要占用的分钟数"),
              earliestStart: z
                .string()
                .regex(HH_MM_PATTERN)
                .optional()
                .describe(
                  "最早能开始的 HH:MM。仅用于明确下界（尚未到家/明确说不能更早）；" +
                    "一般习惯填 preferredStart。"
                ),
              preferredStart: z
                .string()
                .regex(HH_MM_PATTERN)
                .optional()
                .describe("最合适或平时习惯的 HH:MM；可让步的软偏好。"),
              latestStart: z
                .string()
                .regex(HH_MM_PATTERN)
                .optional()
                .describe(
                  "最晚能开始的 HH:MM（明确拒绝更晚才开始才填）；" +
                    "与 earliestStart 相同=只能此刻开始。"
                ),
              saidExactSlot: z
                .boolean()
                .optional()
                .describe(
                  "true=本人明确说出精确开始与时长，且此处 earliestStart/latestStart/" +
                    "durationMinutes 与原话完全一致。选定方案里他的时段与原话一致时" +
                    "免发征询，视原话为许可；只给宽泛范围或被调整过的不填。"
                ),
            })
          )
          .min(2)
          .max(8)
          .describe("至少两个人，一个人不需要排"),
      }),
      execute: async ({ windowLabel, windowStart, people }) => {
        const toMinutes = (hhmm: string): number => {
          const [h, m] = hhmm.split(":").map(Number);
          return h * 60 + m;
        };
        /**
         * **窗口起点原样信模型给的，不再自动往前拉。**
         *
         * 以前这里会替没有硬约束的人凭空多算出一段"更早的空间"，往前
         * 拉窗口起点——这是在凭空假设"更早也能开始"，而这件事本身没有
         * 事实依据（模型给的 `windowStart` 就是当前唯一已知的起点，
         * 往前拉多少完全是猜的）。算法只应该在**给定的**窗口里找最优解，
         * 不该替模型悄悄改题目的输入边界。
         */
        const windowStartMinutes = toMinutes(windowStart);

        // 明确说过“只能/必须/固定在某时开始”的历史表态属于硬事实，不能
        // 因生成模型这次漏填 latestStart 就退化成可随意后移的软条件。
        const storedPositions = [
          ...(await repo.getStandalonePositions(sender.householdId)),
          ...(
            await Promise.all(
              ctx.openCaseIds.map((caseId) => repo.getCasePositions(caseId))
            )
          ).flat(),
        ];

        const constraints = people.map((p) => {
          const personPositions = storedPositions.filter(
            (position) =>
              position.personName === p.name && position.kind !== "commitment"
          );
          const recordedFixedStart = personPositions
            // commitment 是 AI 自己以前许过的话，不是住户的客观硬约束。
            // 否则会形成“我说不动，所以它真的不能动”的闭环。
            .map((position) => extractExplicitFixedStart(position.statement))
            .find((value): value is number => value !== null);
          // 软偏好同等待遇：住户历史表态里说过「七点最合适」「6:30 用半小时」
          // 这类非强制时间，模型本轮忘了填 preferredStart 时，从记录里确定性
          // 抽出来兜底。与 hard 约束不同，这只填 soft 的 preferredStartMinutes，
          // 不碰 earliest/latest。抽取极其保守，拿不准就 null（见函数注释）。
          const recordedPreferredStart = personPositions
            .map((position) =>
              extractPreferredStart(position.statement, windowStartMinutes)
            )
            .find((value): value is number => value !== null);
          const explicitEarliest = p.earliestStart
            ? toMinutes(p.earliestStart)
            : undefined;
          const explicitLatest = p.latestStart
            ? toMinutes(p.latestStart)
            : undefined;
          const fixedStart = recordedFixedStart;
          return {
            name: p.name,
            durationMinutes: p.durationMinutes,
            earliestStartMinutes:
              fixedStart !== undefined
                ? fixedStart - windowStartMinutes
                : explicitEarliest !== undefined
                  ? Math.max(0, explicitEarliest - windowStartMinutes)
                  : 0,
            latestStartMinutes:
              fixedStart !== undefined
                ? fixedStart - windowStartMinutes
                : explicitLatest !== undefined
                  ? explicitLatest - windowStartMinutes
                  : undefined,
            preferredStartMinutes:
              p.preferredStart
                ? toMinutes(p.preferredStart) - windowStartMinutes
                : recordedPreferredStart !== undefined
                  ? recordedPreferredStart - windowStartMinutes
                  : undefined,
          };
        });
        /**
         * **候选数不再写死 3。** 公平尺度换成 worstPreferenceRatio 之后，
         * 真正公平的那个候选未必排在前三——多给几个不会让模型挑花眼
         * （candidates 只是给它核对用，不是选择题选项），但要能覆盖到
         * 真正的最优解，5 个比 3 个更稳，穷举本身几毫秒级，不心疼这点算力。
         */
        // 记下哪些人自报了精确时段及具体 start/end，供后续 contactPerson 做精确比对。
        // 只有选定方案里该人的 start/end 与此处完全一致，才视为预先同意并跳过征询。
        const selfStatedMap = new Map<string, { start: string; end: string }>();
        for (const p of people) {
          if (p.saidExactSlot && p.earliestStart && p.latestStart === p.earliestStart) {
            // 这里存的是模型填的原始 start，end 由 start+duration 推算。
            // 格式化为 HH:MM 与 contactPerson 里的 scheduleSlot.start/end 比对。
            const startMin = toMinutes(p.earliestStart);
            const endMin = startMin + p.durationMinutes;
            const fmt = (m: number) => formatMinutes(m);
            selfStatedMap.set(p.name, { start: fmt(startMin), end: fmt(endMin) });
          }
        }
        if (selfStatedMap.size > 0) {
          selfStatedSlotsByWindow.set(windowLabel, selfStatedMap);
        }

        const plans = bestSchedulePlans(windowStartMinutes, constraints, 5);
        if (plans.length === 0) {
          scheduleProvenInfeasible = true;
          const hasLatest = constraints.some(
            (constraint) => constraint.latestStartMinutes !== undefined
          );
          return {
            ok: false,
            reason: hasLatest
              ? "没排出候选——填的 earliestStart/latestStart 这些硬约束互相顶死，" +
                "物理上排不进这个窗口，回头跟当事人确认是不是真的都是钉死的时间"
              : "没排出候选，检查一下 people 是不是填对了",
          };
        }
        scheduleProvenInfeasible = false;
        // 重新排一次这个窗口，之前选定的方案就作废——不能让 chooseSchedule
        // 继续指向一个已经不存在的旧候选集合。
        scheduleCandidatesByLabel.set(windowLabel, plans);
        selectedSchedules.delete(windowLabel);
        /**
         * **候选1跟"长占用者排最前面"这种直觉排法比，公平在哪——代码算好，
         * 模型只转述。** 真实事故：排法本身完全正确，回复却编了一句
         * "要让两位短时长者各多等两小时以上"来解释为什么选这个候选——
         * 不是排错了，是模型自己心算"这个候选比别的方案好在哪"时编了数字。
         * `describeFairnessGain` 是纯代码比较，直接把这句话准备好。
         */
        const longestName = [...constraints].sort(
          (a, b) => b.durationMinutes - a.durationMinutes
        )[0]?.name;
        const baselinePlan = findSchedulePlans(windowStartMinutes, constraints).find(
          (plan) => plan.order[0] === longestName
        );
        const fairnessRationale = baselinePlan
          ? describeFairnessGain(baselinePlan, plans[0], constraints)
          : null;

        /**
         * **记下全部候选，不是只记第一名。**
         *
         * 初始提议现在强制走 `chooseSchedule` 选候选1（`selectScheduleCandidate`
         * 会拒绝其他编号），候选2-5不再是模型可以凭理由选用的选项，只是
         * 给批判器和人核对"候选1确实更公平"用的对照——`scheduleResults`
         * 是喂给批判器（rubric 6.6）的结构化事实，全部候选都是算法真实
         * 穷举出来的方案（不是模型编的），一并交出去方便核对整套方案
         * 站不站得住。
         */
        for (const [i, p] of plans.entries()) {
          const worseBy = p.totalPreferenceGapMinutes - plans[0].totalPreferenceGapMinutes;
          scheduleResults.push(
            `「${windowLabel}」候选${i + 1}（参与计算的人：${p.order.join("、")}）：${p.assignments
              .map(
                (a) =>
                  `${a.name} ${formatMinutes(a.startMinutes)}-${formatMinutes(a.endMinutes)}` +
                  (a.preferenceGapMinutes !== null
                    ? `（偏离他偏好${a.preferenceGapMinutes}分钟）`
                    : "")
              )
              .join("，")}` +
              (i === 0
                ? `（公平负担最小——单个人相对自己所需时长偏离最大的比例约${Math.round(p.worstPreferenceRatio * 100)}%，总共让大家多等约${p.totalPreferenceGapMinutes}分钟）` +
                  (fairnessRationale ? `\n${fairnessRationale}` : "")
                : worseBy > 0
                  ? `（比候选1总共多让人多等约${worseBy}分钟，仅供比较）`
                  : "（跟候选1总偏离相当，仅供比较）")
          );
        }
        /**
         * **两个以上硬约束互相顶死，结果被拖得很晚时，提醒回头核实——
         * 这类结果只有"这个约束是不是真的硬"这个判断错了才会造成。**
         *
         * 真实事故：2号住客说的"我6:30，然后使用半个小时"是随口说的
         * 习惯，不是像3号住客"我最早必须18:00开始，因为下班18:00到家"
         * 那样明确的硬约束，但模型把两者同样填成了 `earliestStart`。
         * 两个硬约束一旦互相冲突（都要求"不能比这更早"，但物理上排不
         * 下），问题不在窗口边界，在于**这个约束本来可能就不该算硬的**，
         * 这属于语言判断，不是计算，代码不替模型拍板（这个项目一贯的
         * 边界：计算交给代码，判断留给模型），**但可以把"猜错的代价"
         * 摆出来，让模型有机会自己回头核实，而不是闷头把猜错的结果
         * 直接排出去**。
         *
         * 判法：硬约束的人数 ≥ 2 时，algorithmically 没有办法进一步优化
         * （多个硬约束天然会顶到较晚的时刻），提醒模型这类情况下"结果
         * 拖得晚，未必是排列算法的锅，先回头确认每个人的约束是不是真的
         * 说了'不能更早'，而不是随口提了个时间"。
         */
        const hardConstraintCount = constraints.filter(
          (constraint) =>
            constraint.earliestStartMinutes > 0 ||
            constraint.latestStartMinutes !== undefined
        ).length;
        const noteParts: string[] = [];
        if (hardConstraintCount >= 2) {
          noteParts.push(
            "**这次有两个以上的人带了硬约束（earliestStart/latestStart）。**" +
              "排出来的结果如果把人拖到了比较晚的时段，往前拉窗口是救不了的——" +
              "多个硬约束互相顶着，算法已经是在这些约束下能找到的最优解了。" +
              "这时候先回头想一下：这几个硬约束是不是真的听到了'我最早只能几点'" +
              "'不能比这更早''只能几点开始'这类明确的话，还是有人只是随口说了个" +
              "习惯时间（那种该填 preferredStart，不是 earliestStart/latestStart）——" +
              "填错会让算法在一道被人为收紧的题目上瞎耗，怎么排都排不出好结果。"
          );
        }
        return {
          ok: true,
          windowLabel,
          ...(noteParts.length > 0 ? { note: noteParts.join("\n") } : {}),
          candidates: plans.map((p, i) => ({
            rank: i + 1,
            order: p.order,
            slots: p.assignments.map(
              (a) =>
                `${a.name}：${formatMinutes(a.startMinutes)}-${formatMinutes(a.endMinutes)}` +
                (a.preferenceGapMinutes !== null
                  ? a.preferenceGapMinutes === 0
                    ? "（正好是他偏好的时间）"
                    : `（比他说的偏好晚/早了约${a.preferenceGapMinutes}分钟）`
                  : "")
            ),
            latestEnd: formatMinutes(p.latestEndMinutes),
            /**
             * **公平性对比写死成数字，不留给模型自己心算。**
             *
             * `fairnessRatio` = 这个候选里，偏离最惨的那个人「偏离分钟数 /
             * 自己需要的时长」——不是绝对分钟数。理由见 scheduling.ts 里
             * `worstPreferenceRatio` 的注释：同样多等 60 分钟，对占用
             * 半小时的人和占用两小时的人不是一回事，只报绝对分钟数会让
             * 模型误以为"让短时长的人多等"是公平的（因为看起来数字一样）。
             * 候选一按这个比值最小排出来，不代表总分钟数最省——
             * `totalPreferenceGapMinutes` 单独给出来，两个数字都摆着，
             * 模型自己判断要哪种公平。
             */
            note:
              i === 0
                ? (plans.length > 1 && p.worstPreferenceRatio > 0
                    ? `这是公平负担最小的排法：偏离最多的那个人，偏离时长约是他` +
                      `自己所需时长的${Math.round(p.worstPreferenceRatio * 100)}%` +
                      `（总共让大家多等约${p.totalPreferenceGapMinutes}分钟）`
                    : "这是让最多人接近自己偏好的排法") +
                  (fairnessRationale ? `\n${fairnessRationale}` : "")
                : (() => {
                    const worseBy = p.totalPreferenceGapMinutes - plans[0].totalPreferenceGapMinutes;
                    const ratioPct = Math.round(p.worstPreferenceRatio * 100);
                    return `备选：偏离最多的人约占自己所需时长的${ratioPct}%` +
                      (worseBy > 0
                        ? `，总共比候选一多让人多等约${worseBy}分钟`
                        : "，总偏离跟候选一相当") +
                      "——仅供比较；有新事实时更新约束并重新计算";
                  })(),
          })),
        };
      },
    }),

    chooseSchedule: tool({
      description:
        "紧接 pickSchedule 选定候选1为本轮唯一方案。之后 contactPerson 联系" +
        "该窗口里的人必须带同一 windowLabel 和其 scheduleSlot，代码核对一致才发；" +
        "有新事实就重新 pickSchedule，不改选旧候选。",
      inputSchema: z.object({
        windowLabel: z.string().describe("跟 pickSchedule 用的同一个窗口名"),
        candidateNumber: z
          .number()
          .int()
          .min(1)
          .describe("选第几个候选，对应 pickSchedule 返回的 candidates[].rank"),
      }),
      execute: async ({ windowLabel, candidateNumber }) => {
        const candidates = scheduleCandidatesByLabel.get(windowLabel);
        if (!candidates) {
          return { ok: false, reason: `没有叫「${windowLabel}」的 pickSchedule 结果，先调 pickSchedule` };
        }
        const picked = selectScheduleCandidate(candidates, candidateNumber);
        if (!picked.ok) {
          return picked;
        }
        const { plan } = picked.selection;
        selectedSchedules.set(windowLabel, picked.selection);
        scheduleResults.push(
          `「${windowLabel}」已选定候选${candidateNumber}：${plan.assignments
            .map(
              (a) =>
                `${a.name} ${formatMinutes(a.startMinutes)}-${formatMinutes(a.endMinutes)}` +
                (a.preferenceGapMinutes !== null ? `（偏离他偏好${a.preferenceGapMinutes}分钟）` : "")
            )
            .join("，")}` +
            "——这是这次唯一在用的方案，后面所有跟这个窗口有关的消息都要对齐这里的时段。"
        );
        return {
          ok: true,
          note:
            "选定了。给参与者发 contactPerson 时带上 scheduleWindowLabel 和 " +
            "scheduleSlot（他自己的开始/结束时间），代码会核对对不对，" +
            "不用在每条消息里重复解释为什么选这个方案。",
        };
      },
    }),

    recordShare: tool({
      description:
        "把算好的份额存下来。同一件事再被提起时先查这里存过没，别重新心算" +
        "（重算容易跟上次对不上）。一种资源、每个人一条。",
      inputSchema: z.object({
        caseId: z.string().describe("上下文里那一栏给的 id"),
        resource: z.string().describe("分的是什么，比如「周一到周五晚间灶台时段」"),
        name: z.string().describe("分给谁"),
        amount: z.number().describe("这个人分到多少"),
        unit: z.string().describe("单位，比如「分钟」「次/周」"),
        rationale: z
          .string()
          .optional()
          .describe("不是均分时必填：为什么这个人多/少（作息硬约束/医疗需要/既有约定）"),
      }),
      execute: async ({ caseId, resource, name, amount, unit, rationale }) => {
        if (!(await repo.caseExists(sender.householdId, caseId))) {
          return { ok: false, reason: "没有这件事，别编 id" };
        }
        const m = await repo.findPersonByName(sender.householdId, name);
        if (!m) {
          return { ok: false, reason: `房子里没有叫「${name}」的人` };
        }
        await repo.recordCaseShare({
          caseId,
          householdId: sender.householdId,
          resource,
          personId: m.personId,
          amount,
          unit,
          rationale: rationale ?? null,
        });
        return { ok: true };
      },
    }),

    scheduleReminder: tool({
      description:
        "给未来某刻安排一件「到时要主动开口」的事（轮换/到点重问偏好）。" +
        "这是你唯一能让自己在没人说话时、未来主动联系人的办法；" +
        "到点由后台触发，不用你自己盯。",
      inputSchema: z.object({
        description: z.string().describe("到时候要做的事，一句话，写清楚背景"),
        dueAt: z.string().describe("到期时间，ISO 8601 格式或「YYYY-MM-DD」"),
        name: z
          .string()
          .optional()
          .describe("这件事主要跟谁有关，不填就是整栋房子的事"),
        ruleId: z.string().optional().describe("跟某条规则有关就填它的 id"),
      }),
      execute: async ({ description, dueAt, name, ruleId }) => {
        const due = new Date(dueAt);
        if (Number.isNaN(due.getTime())) {
          return { ok: false, reason: "dueAt 不是能解析的时间，别编格式" };
        }
        let personId: string | null = null;
        if (name) {
          const m = await repo.findPersonByName(sender.householdId, name);
          if (!m) {
            return { ok: false, reason: `房子里没有叫「${name}」的人` };
          }
          personId = m.personId;
        }
        const id = await repo.scheduleReminder({
          householdId: sender.householdId,
          personId,
          ruleId: ruleId ?? null,
          description,
          dueAt: due,
        });
        return { ok: true, obligationId: id };
      },
    }),

    recordPosition: tool({
      description:
        "记某人对未结事表过的态（想要/拒绝）或你许过的承诺。涉及多方、可能冲突的" +
        "话说了就记，别指望之后几轮还记得。**立不立案都能用**——随口提到的时段偏好/" +
        "态度，只要以后可能用得上当场就记，不用等升级成案子；没立案就不填 caseId。" +
        "上下文列出的表态都是已记过的，开新方案前先看，别漏、别自相矛盾。",
      inputSchema: z.object({
        caseId: z
          .string()
          .optional()
          .describe(
            "这条表态属于哪件「未结的事」就填它的 id；还没立案、只是随口提到就不填——" +
              "不确定时，不填比编一个 id 安全。"
          ),
        name: z.string().describe("说这句话的人，或者你许诺的对象"),
        kind: z
          .enum(["preference", "rejection", "commitment"])
          .describe(
            "preference=他说想要什么 · rejection=他明确拒绝了什么 · " +
              "commitment=你自己对他许下的承诺"
          ),
        statement: z.string().describe("一句话，念给当事人听的那种，不是内部黑话"),
      }),
      execute: async ({ caseId, name, kind, statement }) => {
        if (caseId && !(await repo.caseExists(sender.householdId, caseId))) {
          return { ok: false, reason: "没有这件事，别编 id" };
        }
        const m = await repo.findPersonByName(sender.householdId, name);
        if (!m) {
          return { ok: false, reason: `房子里没有叫「${name}」的人` };
        }
        await repo.recordCasePosition({
          caseId: caseId ?? null,
          householdId: sender.householdId,
          personId: m.personId,
          kind,
          statement,
        });
        return { ok: true };
      },
    }),

    addResident: tool({
      description:
        "把一个手机号加进这栋房子。拿到号码就加，不要等——房东（或别人）在对话里" +
        "报出室友号码时用；名字不知道就不填，占位符不影响。**加完这一轮就要用 " +
        "contactPerson 主动跟他打招呼**（结果会给你名字）——他还不认识你，别等他" +
        "先开口，也别拖到下一轮；报了好几个就逐个都打，别漏。",
      inputSchema: z.object({
        phone: z.string().describe("手机号，原样填，系统会自己规范化"),
        name: z.string().optional().describe("对方说了名字才填，没说就留空"),
        role: z
          .enum(["tenant", "landlord"])
          .optional()
          .describe("默认 tenant。只有明确是业主才填 landlord"),
        note: z.string().optional().describe("顺带提到的信息，比如住哪间"),
      }),
      execute: async ({ phone, name, role, note }) => {
        try {
          const r = await repo.addResident({
            householdId: sender.householdId,
            phone,
            name: name ?? null,
            role: (role ?? "tenant") as repo.Role,
            note: note ?? null,
          });
          if (r.created) {
            newlyAdded.set(r.personId, r.name);
          }
          return {
            ok: true,
            created: r.created,
            name: r.name,
            note: r.created
              ? `已加入，系统给他起的名字是「${r.name}」——没听到真名之前，` +
                "调 contactPerson 时 name 参数就填这个（不是发给他的话里出现这个，" +
                "消息正文不能提占位名，只是拿它当查找用的 key）。他还完全不" +
                "认识你，现在就用 contactPerson 主动打个招呼、说清楚你是谁——" +
                "不要等到有事才第一次联系他。说什么由你自己定，不用套模板。"
              : "这个号码本来就在房子里",
          };
        } catch (e) {
          return {
            ok: false,
            reason: e instanceof Error ? e.message : "加不进去",
          };
        }
      },
    }),

    confirmRoster: tool({
      description:
        "有人告诉你这屋一共住几人时，立刻记下那个数字，记完就不会再问第二遍。" +
        "只管数字对，齐不齐由系统自己比，不用你算。",
      inputSchema: z.object({
        total: z.number().describe("对方说的总人数，就这一个数字"),
      }),
      execute: async ({ total }) => {
        await repo.setDeclaredSize(sender.householdId, total);
        await repo.noteMemory({
          householdId: sender.householdId,
          kind: "fact",
          content: `${sender.name}说这屋一共住 ${total} 人`,
          sourceEventId: lastEventId,
        });
        const status = await repo.rosterStatus(sender.householdId);
        return {
          ok: true,
          note: status.complete
            ? "记下了，名册已经齐了，以后不会再问这个"
            : `记下了，还差 ${total - status.knownCount} 个人的号码`,
        };
      },
    }),

    renamePerson: tool({
      description:
        "改某个人的显示名。自然听出真名才用（本人说「我是小王」或别人提到）；" +
        "要称呼他却不知名字时，问一句「怎么称呼你」是自然的，问到了就记。",
      inputSchema: z.object({
        currentName: z.string().describe("现在系统里叫什么（占位名或旧名）"),
        newName: z.string().describe("听出来的真名或他希望被怎么称呼"),
        confirmed: z
          .boolean()
          .optional()
          .describe("true=他本人说的；false=从别人嘴里听来的，可能不准"),
      }),
      execute: async ({ currentName, newName, confirmed }) => {
        const m = await repo.findPersonByName(sender.householdId, currentName);
        if (!m) {
          return { ok: false, reason: `房子里没有叫「${currentName}」的人` };
        }
        await repo.renamePerson({
          personId: m.personId,
          name: newName,
          confirmed: confirmed ?? true,
        });
        return { ok: true };
      },
    }),

    remember: tool({
      description:
        "记关于某个人的长期事实——说话里带出来的就顺手记、不声张。" +
        "记完不要告诉他你记了，也别复述给别人。**只记事实不记评判**" +
        "（「他上夜班」是事实，「他挺懒的」不是，那会带来偏见）。" +
        "不记经过（那个用 logEvent），只记以后还用得上的。",
      inputSchema: z.object({
        name: z.string().describe("这条记忆是关于谁的"),
        kind: z
          .string()
          .describe(
            "你自己起个短名字：schedule / preference / sensitivity / " +
              "identity / health / work / language 都行。**没有固定清单**"
          ),
        content: z.string().describe("一句话，写事实"),
        basis: z
          .enum(["stated", "observed", "inferred", "third_party"])
          .describe(
            "这条怎么来的，必须诚实：stated=本人说的 · observed=从系统记录看到 · " +
              "inferred=你推出来的 · third_party=别人说他、他本人没确认过。\n" +
              "A 跟你说「B 半夜在厨房打电话」，给 B 记的是 third_party，不是 stated。" +
              "把推断或别人指控标成 stated，几个月后你会当确认过的事实读回去——" +
              "记忆会被自己污染，回不去了。"
          ),
        subjectKey: z
          .string()
          .describe(
            "主题键。**同一个人同一个主题只留一条当前有效**，新的自动取代旧的。\n" +
              "优先从这些挑：`work_schedule`（上什么班/几点上下班——作息和班次是同一主题，" +
              "别一次写 work 一次写 sleep_schedule）· `cooking_time` · `health` · " +
              "`diet` · `guests` · `noise_sensitivity` · `language` · `identity` · `room`\n" +
              "关键：同一件事一直用同一个键。3 月说 11 点睡、8 月说凌晨 3 点回——" +
              "那是取代，不是并列。"
          ),
        untilWhen: z
          .string()
          .optional()
          .describe(
            "这条事实何时失效（ISO 日期）。**话里带时间范围就必须填**：" +
              "这周→本周日、这两天→两天后、周四→周五。不填=永久有效；" +
              "把临时的存成永久，几个月后你就搞错了。"
          ),
      }),
      execute: async ({ name, kind, content, basis, subjectKey, untilWhen }) => {
        const m = await repo.findPersonByName(sender.householdId, name);
        if (!m) {
          return { ok: false, reason: `房子里没有叫「${name}」的人` };
        }
        // 算不出向量不影响记录本身，只是以后语义召回不到这条
        let embedding: number[] | null = null;
        try {
          embedding = await embedOne(`${kind}｜${content}`);
        } catch {
          embedding = null;
        }
        const factTo = untilWhen ? new Date(untilWhen) : null;
        await repo.noteMemory({
          householdId: sender.householdId,
          personId: m.personId,
          kind,
          content,
          basis,
          statedBy: sender.personId,
          subjectKey,
          factTo: factTo && !Number.isNaN(factTo.getTime()) ? factTo : null,
          sourceEventId: lastEventId,
          embedding,
        });
        return { ok: true };
      },
    }),

    closeCase: tool({
      description:
        "一件事了结了就收尾——「还没了结的事」里看得出已经过去的就该收掉" +
        "（住户说好、不再提、安排后没再出问题）。不收它会一直挂着干扰每一轮。",
      inputSchema: z.object({
        caseId: z.string().describe("上下文里那一栏给的 id"),
        kind: z
          .enum([
            "resolved",
            "improved",
            "recurred",
            "worsened",
            "no_response",
            "escalated",
            "withdrawn",
          ])
          .describe(
            "resolved=彻底解决 · improved=好转未根治 · recurred=又犯 · " +
              "worsened=更糟 · no_response=没人理 · escalated=转房东 · " +
              "withdrawn=提出者自己撤"
          ),
        note: z.string().describe("一句话说清后来怎么样了"),
        sentiment: z
          .number()
          .optional()
          .describe("住户对处理结果的反应：-1 不满 / 0 中性 / 1 满意。看不出就不填"),
        accounting: z
          .array(
            z.object({
              positionId: z.string().describe("上下文里表态那一行的 id"),
              honored: z.boolean().describe("这条表态最后有没有被满足/兑现"),
              note: z
                .string()
                .optional()
                .describe("honored=false 时必填：为什么没能满足，怎么跟对方说的"),
            })
          )
          .optional()
          .describe(
            "resolved 时把这件事记过的每条表态都过一遍填进来，一条不能漏；" +
              "没记过表态不用填。"
          ),
        notifiedParties: z
          .array(z.string())
          .optional()
          .describe(
            "结果不是本轮 contactPerson 发的、而是之前对话已说清时，才在这里手动列人名" +
              "（本轮真调 contactPerson 的会自动核对，不用重复填）。"
          ),
      }),
      execute: async ({
        caseId,
        kind,
        note,
        sentiment,
        accounting,
        notifiedParties,
      }) => {
        if (!(await repo.caseExists(sender.householdId, caseId))) {
          return { ok: false, reason: "没有这件事，别编 id" };
        }
        if (kind === "resolved") {
          const positions = await repo.getCasePositions(caseId);
          const unaccounted = positions.filter((p) => p.honored === null);
          if (unaccounted.length > 0) {
            const covered = new Set((accounting ?? []).map((a) => a.positionId));
            const missing = unaccounted.filter((p) => !covered.has(p.id));
            if (missing.length > 0) {
              return {
                ok: false,
                reason:
                  "这件事记过表态，收口前每一条都要交代：" +
                  missing
                    .map((p) => `${p.personName}「${p.statement}」（id=${p.id}）`)
                    .join("；") +
                  "。在 accounting 里逐条填 honored 和必要的 note，再收口。",
              };
            }
          }
          const missingNote = (accounting ?? []).find(
            (a) => a.honored === false && !a.note?.trim()
          );
          if (missingNote) {
            return {
              ok: false,
              reason: `id=${missingNote.positionId} 那条没满足，必须写 note 说清楚为什么、怎么跟对方交代的`,
            };
          }
          for (const a of accounting ?? []) {
            await repo.accountCasePosition({
              positionId: a.positionId,
              honored: a.honored,
              resolutionNote: a.note ?? null,
            });
          }

          // 通知覆盖率核对：这件事标过"影响到谁"的名单，逐个查是不是
          // 本轮真的联系过（contacted 集合，来自本轮的 contactPerson 调用），
          // 或者模型显式声明"之前已经说过了"（notifiedParties）。
          const parties = await repo.getCaseParties(caseId);
          const explicitlyNotified = new Set<string>();
          for (const n of notifiedParties ?? []) {
            const m = await repo.findPersonByName(sender.householdId, n);
            if (m) {
              explicitlyNotified.add(m.personId);
            }
          }
          const stillUnnotified = parties.filter(
            (p) =>
              p.notified !== true &&
              !contacted.has(p.personId) &&
              p.personId !== sender.personId &&
              !explicitlyNotified.has(p.personId)
          );
          if (stillUnnotified.length > 0) {
            return {
              ok: false,
              reason:
                "这件事标过受影响的人，收口前每个人都要知道最终结果：" +
                stillUnnotified.map((p) => p.personName).join("、") +
                " 还没被通知到。本轮用 contactPerson 逐个告诉他们结果，" +
                "或者如果之前已经说过了，在 notifiedParties 里列出来再收口。",
            };
          }
          for (const p of parties) {
            const nowNotified =
              p.notified === true ||
              contacted.has(p.personId) ||
              p.personId === sender.personId ||
              explicitlyNotified.has(p.personId);
            if (nowNotified && p.notified !== true) {
              await repo.markCasePartyNotified(caseId, p.personId, true);
            }
          }
        }
        await repo.updateCase({
          caseId,
          status: kind === "recurred" || kind === "worsened" ? "open" : "resolved",
          resolution: note,
        });
        await repo.recordOutcome({
          caseId,
          kind,
          note,
          sentiment: sentiment ?? null,
        });
        return {
          ok: true,
          note:
            kind === "resolved" && (accounting ?? []).length > 0
              ? "交代完了。**收口前后要给所有相关的人发一条最终消息**——" +
                "包括表态没被满足的人，不能只通知满足了的那些人。"
              : undefined,
        };
      },
    }),

    noteObservation: tool({
      description:
        "记一条关于这栋房子所在位置的环境观察：气味/噪音/施工/天气/外面动静。" +
        "住户报的那件事用 logEvent，这里记的是「地点+时间」的环境事实——" +
        "以后抱怨噪音时能查到外面当时是否有动静，不至于把外面的事算到室友头上。",
      inputSchema: z.object({
        kind: z
          .string()
          .describe("odor / noise / construction / weather / air_quality 等"),
        summary: z.string().describe("一句话：什么现象、大概什么时候"),
        severity: z
          .number()
          .optional()
          .describe("0 到 1，多严重。说不好就不填"),
      }),
      execute: async ({ kind, summary, severity }) => {
        await repo.recordObservation({
          householdId: sender.householdId,
          kind,
          summary,
          severity: severity ?? null,
          source: "resident",
          sourcePersonId: sender.personId,
        });
        return { ok: true };
      },
    }),

    recall: tool({
      description:
        "按意思翻以前记下的记忆。说法不同但指同一件事（如半夜厨房声响）时用——" +
        "SQL 查不出同义表达。更早的、别人的、已过期的都靠它翻。",
      inputSchema: z.object({
        query: z.string().describe("用一句话说你想找什么"),
      }),
      execute: async ({ query }) => {
        let vec: number[] | null = null;
        try {
          vec = await embedOne(query);
        } catch {
          return { ok: false, reason: "算不出向量，这次查不了" };
        }
        const hits = await repo.recallMemories({
          householdId: sender.householdId,
          queryVector: vec,
        });
        return {
          count: hits.length,
          memories: hits.map((h) => ({
            who: h.who,
            content: h.content,
            // 让模型看见这条是事实还是推断，别拿推断当证据
            basis: h.basis === "inferred" ? "推测（不是事实）" : "本人说的",
          })),
        };
      },
    }),

    lookupHistory: tool({
      description:
        "查这栋房子过去发生过什么。**判断力度之前先查**：" +
        "首次和第五次是完全不同的处理。",
      inputSchema: z.object({
        aboutName: z.string().optional().describe("只看跟某个人有关的"),
        kind: z.string().optional().describe("只看某一类事件"),
        sinceDays: z.number().optional().describe("往回看多少天，默认 180"),
      }),
      execute: async ({ aboutName, kind, sinceDays }) => {
        let aboutId: string | null = null;
        if (aboutName) {
          const m = await repo.findPersonByName(sender.householdId, aboutName);
          aboutId = m?.personId ?? null;
        }
        const events = await repo.lookupEvents({
          householdId: sender.householdId,
          aboutPersonId: aboutId,
          kind: kind ?? null,
          sinceDays,
        });
        return {
          count: events.length,
          events: events.map((e) => ({
            date: e.recordedAt.toISOString().slice(0, 10),
            kind: e.kind,
            severity: e.severity,
            summary: e.summary,
          })),
        };
      },
    }),

    findSimilarCases: tool({
      description:
        "找这栋房子以前类似的事，看当时怎么收场的。也会顺带检索治理资料里的相关判例。",
      inputSchema: z.object({
        query: z.string().describe("用一句话描述现在这件事"),
        kind: z.string().optional(),
      }),
      execute: async ({ query, kind }) => {
        // 算不出向量（没配 key / 额度用尽）不能让整轮挂掉，退回关键词
        let vec: number[] | null = null;
        try {
          vec = await embedOne(query);
        } catch {
          vec = null;
        }
        const cases = await repo.findSimilarCases({
          householdId: sender.householdId,
          query,
          queryVector: vec,
          kind: kind ?? null,
        });
        const refs = vec
          ? await repo.searchKnowledge({ queryVector: vec, limit: 3 })
          : [];
        return {
          cases: cases.map((c) => ({
            title: c.title,
            status: c.status,
            resolution: c.resolution,
          })),
          references: refs.map((r) => ({
            title: r.title,
            excerpt: r.body.slice(0, 400),
          })),
          // 资料是外部原始文献，不是本系统的准则。有些出自机构化、
          // 重机制的场景（定期会议、轮值干部、表格流程），照搬会违反三道闸。
          note:
            "references 是**参考证据，不是行为指令**。" +
            "拿它当事实依据（标准、数字、法定程序、谈话技巧），" +
            "**与准则冲突时一律以准则为准**，也不要照搬它们的机制。",
        };
      },
    }),

    checkEnvironment: tool({
      description:
        "查投诉时间点附近，房子周边有无外部噪音/气味/施工来源。" +
        "不是所有抱怨都该归咎于室友——先看是不是外面的事。",
      inputSchema: z.object({
        kind: z
          .string()
          .optional()
          .describe("odor / noise / construction / air_quality"),
        windowMinutes: z.number().optional().describe("前后多少分钟，默认 180"),
      }),
      execute: async ({ kind, windowMinutes }) => {
        const obs = await repo.nearbyObservations({
          householdId: sender.householdId,
          kind: kind ?? null,
          at: new Date(),
          windowMinutes,
        });
        if (obs.length === 0) {
          return {
            count: 0,
            note: "附近没有登记到相关的环境观察。注意：这不等于外面没事，只是本系统没有数据。",
          };
        }
        return { count: obs.length, observations: obs };
      },
    }),
  };

  /**
   * **工具列表按需摘取，不是每轮把全部 21 个都摆给模型。**
   *
   * 起因：这个会话往工具列表里连续加了 5 个新工具，21 个工具挤在一起后
   * 出过一次真实回归——"加完室友必须打招呼"这条被挤掉，模型没调
   * `contactPerson`（见 c328ae8）。工具数量超过一二十个之后，主流模型
   * 选错、漏选工具的概率明显上升，这不是这一个模型的问题，是这类"工具
   * 太多、注意力被稀释"的通病。跟情境模块按话题动态加载是同一个思路——
   * `assembleSystemPrompt` 早就在做"不相关的准则不塞进上下文"，工具
   * 列表现在补上同一层过滤。
   *
   * 分两组：
   *
   *   **① 核心链路（6个，永远常驻）**：`decide` `sendReply` `logEvent`
   *   `contactPerson` `remember` `addResident`——几乎每一轮都会用到，
   *   缺一个就断链路。`addResident` 单独跟核心链路绑在一起不放进情境组，
   *   是吸取 c328ae8 的教训：房东随时可能突然报个号码，不一定伴着
   *   "入住"这类字眼，漏摆的代价（联系不上新住户）远比多摆一个工具的
   *   注意力成本高，宁可常驻也不赌路由。
   *
   *   **② 情境组（11个，按结构信号或话题信号决定要不要摆出来）**：
   *   优先用**结构信号**（比纯话题关键词更准，不会因为这一轮没提到
   *   相关字眼就漏摆）——`closeCase` 只要 `openCaseIds` 非空就摆
   *   （不看话题：钱类、安全类结案都不会被"这轮聊的是不是冲突"卡住）；
   *   `confirmRoster` 只要名册没收全就摆；`renamePerson` 只要有人还
   *   顶着占位名就摆。其余用话题信号（`loadedModuleIds` 是不是命中了
   *   `tenancy`/`conflict`）兜底。
   *
   *   **③ 查询/观察类（5个，按需暴露，默认不摆）**：`noteObservation`
   *   `checkEnvironment` 只在出现外部环境/气味/噪音/天气等信号时给；
   *   `recall` `lookupHistory` `findSimilarCases` 只在已开着案子或本轮
   *   明显是"反复/历史"类信号时给。它们本来就是低频、模型主动判断
   *   "要不要查"的工具，不该占常驻位（本轮瘦身目标）。信号用下面代码
   *   能确定的保守词表，**宁可少给**——模型需要时会少，但不会错给。
   */
  const hasUnconfirmedName = ctx.members.some((m) => !m.nameConfirmed);
  const topicHitsTenancy = loadedModuleIds.includes("tenancy");
  const topicHitsHouseRules = loadedModuleIds.includes("house-rules");
  const topicHitsConflict = loadedModuleIds.includes("conflict");
  const environmentSignal =
    /外面|楼下|隔壁|邻居|街上|马路|街道|施工|装修|工地|天气|下雨|下雪|刮风|很臭|臭味|气味|烟味|油烟|噪音|噪声|吵|太响/i.test(
      args.text
    );
  const historySignal =
    ctx.openCaseIds.length > 0 ||
    /上次|以前|过去|历史|又|再次|老是|总是|经常|每次都|again|repeat|recur/i.test(
      args.text
    );
  const activeTools: Record<string, (typeof tools)[keyof typeof tools]> = {
    decide: tools.decide,
    sendReply: tools.sendReply,
    logEvent: tools.logEvent,
    contactPerson: tools.contactPerson,
    remember: tools.remember,
    addResident: tools.addResident,
  };
  if (ctx.openCaseIds.length > 0) {
    activeTools.closeCase = tools.closeCase;
  }
  if (!ctx.roster.complete) {
    activeTools.confirmRoster = tools.confirmRoster;
  }
  if (hasUnconfirmedName) {
    activeTools.renamePerson = tools.renamePerson;
  }
  if (topicHitsTenancy || topicHitsHouseRules || topicHitsConflict) {
    activeTools.proposeRule = tools.proposeRule;
    activeTools.recordStance = tools.recordStance;
    activeTools.scheduleReminder = tools.scheduleReminder;
  }
  if (topicHitsConflict) {
    activeTools.pickSchedule = tools.pickSchedule;
    activeTools.chooseSchedule = tools.chooseSchedule;
    activeTools.recordShare = tools.recordShare;
    activeTools.notePartyAffected = tools.notePartyAffected;
    activeTools.recordPosition = tools.recordPosition;
  }
  if (environmentSignal) {
    activeTools.noteObservation = tools.noteObservation;
    activeTools.checkEnvironment = tools.checkEnvironment;
  }
  if (historySignal) {
    activeTools.recall = tools.recall;
    activeTools.lookupHistory = tools.lookupHistory;
    activeTools.findSimilarCases = tools.findSimilarCases;
  }

  /**
   * 系统提示词拆成两条，**缓存断点卡在中间**。
   *
   * 这是本模块最大的一笔省钱：带工具的一轮对话不是一次调用，而是每调一次工具
   * 就把整个提示词重发一遍——四个工具就是五遍一万四千字的准则。
   * 准则那一段逐字不变，可以缓存（写入 1.25 倍价，命中 0.1 倍价）；
   * 运行时状态每轮都变，留在断点之外，否则一变就整段落空。
   */
  const result = await generateText({
    abortSignal: turnAbortSignal(),
    model: getLanguageModel(modelId),
    system: [
      {
        role: "system" as const,
        content: doctrine,
        providerOptions: { anthropic: { cacheControl: { type: "ephemeral" } } },
      },
      ...(runtime ? [{ role: "system" as const, content: runtime }] : []),
    ],
    messages: [...history, { role: "user" as const, content: args.text }],
    tools: activeTools,
    // 交付了正文就收工；没交付则最多跑到步数上限
    stopWhen: [hasToolCall("sendReply"), stepCountIs(MAX_STEPS)],
  });

  for (const step of result.steps) {
    for (const call of step.toolCalls ?? []) {
      toolsUsed.push(call.toolName);
    }
  }

  /**
   * 正文优先取模型显式交付的那份。
   *
   * 没调 sendReply 时才退回自由文本，并且**只拼最后一段连续的文字**——
   * 早期 step 里的往往是写给自己看的计划。这是兜底，不是主路径。
   */
  let raw = deliveredReply as string | null;
  if (!raw) {
    /**
     * 没调 sendReply 的情况**不是模型不想交付，是 MAX_STEPS 按步数算，
     * 不是按工具调用数算**——花几步纯思考（不调工具）就可能在真正调用
     * sendReply 之前把预算耗尽。真实发生过：三次同类测试里有一次，
     * 工具列表只有 findSimilarCases,logEvent,decide，最后一段自由文本
     * 是「方便这两天一起转我一下吗」——像是没写完的思考片段，不是
     * 打算发出去的话，却被当成正文发给了用户（金钱话题上这种误发
     * 风险更高）。
     *
     * 补一次**强制调用 sendReply** 的小调用兜底，而不是继续信任自由文本：
     * 带着到这里为止的完整上下文（含所有工具调用与结果），逼它把已经
     * 想好的结论交付成一句正文。这比"猜哪段文字是正文"可靠得多。
     */
    try {
      const forced = await generateText({
        abortSignal: turnAbortSignal(),
        model: getLanguageModel(modelId),
        system: [
          {
            role: "system" as const,
            content: doctrine,
            providerOptions: {
              anthropic: { cacheControl: { type: "ephemeral" } },
            },
          },
          ...(runtime ? [{ role: "system" as const, content: runtime }] : []),
        ],
        messages: [
          ...history,
          { role: "user" as const, content: args.text },
          ...result.response.messages,
          {
            role: "user" as const,
            content:
              "【系统提示】上面的判断和操作都已经做完了，你还没有交付正文。" +
              "现在只做一件事：调 sendReply，把要发给对方的那句话交出来。",
          },
        ],
        tools: { sendReply: tools.sendReply },
        toolChoice: { type: "tool", toolName: "sendReply" },
      });
      // 补上：这次强制重试自己的工具调用之前从没被记进 toolsUsed——
      // 安全网确实兜住了、消息也送达了，但事后完全看不出这一轮其实是
      // 靠安全网兜住的，会掩盖"主生成为什么没能正常交付"这条排查线索
      // （这个会话反复靠 toolsUsed 诊断问题，这是真实存在的盲区）。
      for (const step of forced.steps) {
        for (const call of step.toolCalls ?? []) {
          toolsUsed.push(call.toolName);
        }
      }
      raw = deliveredReply ?? "";
    } catch (error) {
      console.log(
        "[turn] 强制 sendReply 兜底失败，退回自由文本：",
        error instanceof Error ? error.message : String(error)
      );
    }
    // 连强制兜底都没拿到正文，才退到最后一段自由文本——双重保险，不是主路径
    if (!raw) {
      const texts = result.steps
        .map((s) => s.text?.trim())
        .filter((t): t is string => Boolean(t));
      raw = texts.at(-1) ?? "";
    }
  }
  let reply = stripMarkdown(raw.trim());

  /**
   * **落锤短回复：简单肯定 + 排班征询 → 代码直接给短确认，不让模型复述全屋方案。**
   *
   * 真实事故（生产日志，2026-09-06）：住户回"愿意"，系统给完整排班表 +
   * "还在问别人"——doctrine 已有条款但模型这条没有执行。真正的短路在
   * buildContext/主生成之前的"短路闸"（上方）：模型不跑、代码直接落短句；
   * 这里是模型路径走完后的幂等防线——同一条件命中时再收口一次，防止任何
   * 审稿/重写把短句替换成整张方案。它只发生在"模型本不该跑"的简单肯定回合，
   * 不是替大脑写当前说话人的正文。
   *
   * simpleScheduleAffirmation 标记这个回合是"代码短路落锤"，终稿（见收尾
   * "最终落锤：简单肯定覆盖"）用它把短句最后再钉一次。
   */
  let simpleScheduleAffirmation = false;
  let simpleScheduleConfirmationText = "";
  const answeringCtx = answering ?? null;
  if (
    isSimpleAffirmation(args.text) &&
    isScheduleSlotInquiry(answeringCtx)
  ) {
    const slot = answeringCtx ? extractSlotFromInquiry(answeringCtx.body) : null;
    simpleScheduleConfirmationText = slot
      ? `好，${slot} 就定给你了。`
      : `好，时段定了，按这个来。`;
    reply = simpleScheduleConfirmationText;
    simpleScheduleAffirmation = true;
  }

  /**
   * **代码强制，不再是提示词劝说**：这一轮新加进来的人，
   * 只要还没被联系过，这里就再补一步，强制调 contactPerson。
   *
   * 起因：`addResident` 工具描述里一直写着"加完这个人这一轮就要打招呼"，
   * 靠模型自己记得去调 `contactPerson`。这条本来在真实场景里跑得住
   * （见 ca23e45 那次修复，连续验证 3/3 次），但**后来两次会话往
   * 工具列表里加了 `recordPosition`/`notePartyAffected`/`recordShare`/
   * `scheduleReminder` 四个新工具**，模型这一轮要在更多选项里分配步数，
   * "加完人就打招呼"这条不带强制力的提示被挤掉——生产上真实复现：
   * `addResident` 调用了两次，`contactPerson` 一次没调，回复里却说
   * "回头会联系他们打个招呼"，批判器也正确抓到了这个落差（第7条：
   * 说了要联系但本轮没有对应的工具调用），**但批判器打回后的重写路径
   * 只会强制换一种说法，不会强制真的去联系**——所以最后送出去的还是
   * 一句"回头联系"的空话，人从头到尾没收到消息。
   *
   * 靠提示词改法（不管改措辞、改工具顺序、加免责声明）都只是让这类
   * 回归"这次不复现了"，下次工具列表一变又可能挤掉。这里直接用代码把
   * "新人必须被联系到"钉死：不管模型这一轮记不记得、不管批判器抓没抓到，
   * 只要 newlyAdded 里有人还没进 contacted，就强制再跑一次只带
   * contactPerson 这一个工具的生成，逼模型对每个漏掉的人各发一条。
   */
  const uncontactedNew = [...newlyAdded.keys()].filter(
    (id) => !contacted.has(id)
  );
  if (uncontactedNew.length > 0) {
    const names = uncontactedNew
      .map((id) => newlyAdded.get(id))
      .filter((n): n is string => !!n);
    if (names.length > 0) {
      try {
        const forcedContact = await generateText({
          abortSignal: turnAbortSignal(),
          model: getLanguageModel(modelId),
          system: [
            {
              role: "system" as const,
              content: doctrine,
              // 跟主生成调用、下面的force-sendReply同一个道理：
              // 这段一轮里可能被重发好几次，逐字不变，该开缓存
              providerOptions: { anthropic: { cacheControl: { type: "ephemeral" } } },
            },
            { role: "system" as const, content: runtime },
          ],
          messages: [
            ...history,
            { role: "user" as const, content: args.text },
            {
              role: "user" as const,
              content:
                `【这不是住户说的，是系统提醒】这一轮刚加进系统、但还没被联系过的人：` +
                `${names.join("、")}。每个人都要调一次 contactPerson 主动打个招呼、` +
                "说清楚你是谁——不套模板，措辞自己定。有几个人就调几次。",
            },
          ],
          tools: { contactPerson: tools.contactPerson },
          toolChoice: { type: "tool", toolName: "contactPerson" },
          stopWhen: stepCountIs(names.length),
        });
        // 同一个盲区（2026-09-05 泛化排班硬规则时才发现原来不止一处）：
        // 这次强制补发自己的工具调用之前没被记进 toolsUsed，外部看不出
        // "新人已经被联系到"到底是主生成做的还是这条安全网兜住的。
        for (const step of forcedContact.steps) {
          for (const call of step.toolCalls ?? []) {
            toolsUsed.push(call.toolName);
          }
        }
      } catch (error) {
        console.log(
          "[turn] 强制打招呼补发失败：",
          error instanceof Error ? error.message : String(error)
        );
      }
    }
  }

  /**
   * 发出去之前过一道批判器（宪法层）。
   * 不过就让生成器改一版，**只改一次**——见 critic.ts 里为什么不迭代。
   */
  /**
   * 收信人在这件事里是什么角色。**批判器最需要的就是这个**——
   * 同一段内容发给报告问题的人和发给被说到的人，一个合格一个是指控。
   *
   * 他自己刚说了话 = 他是来反映情况的；我们主动发的 = 他多半是被说到的那个。
   * 判不准就说不确定，别硬猜（宪法第二条）。
   */
  const senderRole = args.text.trim()
    ? ("报告问题的人" as const)
    : ("不确定" as const);

  /**
   * **名册上有几个名字，不等于总人数已经确认。** 批判器只看得到下面这行
   * 列出的名字，容易把"名册还没收全、该问总人数"的合法提问，误判成
   * "人数明明知道、何必再问"——第18轮踩过：3个名字都在案，但没人明确
   * 说过"我们一共3个人"，模型问总人数被批判器错当成多余问题打回。
   *
   * **这里必须现查，不能用 `ctx.roster`。** `ctx` 是这一轮开头建的快照，
   * 如果这一轮模型自己刚调过 confirmRoster（对方这句话正是在报总人数），
   * `ctx.roster` 还停在调用前的"未确认"状态——批判器会把模型正确记下的
   * 总人数当成"还没确认"，逼着模型对刚回答过的问题重新问一遍。生产上
   * 真出过：房东回"三个人，算上我"，AI 确认后被打回，重写变成又问了
   * 一遍"一共住几位"，跟房东刚说的话完全对不上。
   */
  const liveRoster = await repo.rosterStatus(sender.householdId);
  const livePositionFacts = [
    ...(await repo.getStandalonePositions(sender.householdId)),
    ...(
      await Promise.all(
        ctx.openCaseIds.map((caseId) => repo.getCasePositions(caseId))
      )
    ).flat(),
  ];
  const rosterNote = liveRoster.complete
    ? "（总人数已确认）"
    : "（⚠️ 总人数还没确认过，问一句「一共住几个人」不算多余）";
  /**
   * 做成函数而不是一次性 const：`toolsUsed`/`scheduleResults` 在排班
   * 追加重写循环里会继续变化（重写时真的调用了 `pickSchedule`），
   * 喂给下一轮重写的事实必须是当时最新的，不能是这个函数第一次
   * 被调用时的快照。
   */
  const renderBaseFacts = () =>
    `名册上的人：${ctx.members.map((m) => m.name).join("、")}${rosterNote}\n` +
    (livePositionFacts.length
      ? `已记录的住户原话：${livePositionFacts
          .map((position) => `${position.personName}：${position.statement}`)
          .join("；")}\n`
      : "") +
    `本轮调用的工具：${toolsUsed.join("、") || "无"}` +
    (isScheduleFairnessObjection(args.text)
      ? "\n⚠️ 说话人这轮在反对排班并质疑公平性。先回应他的反对，不要原样重复旧方案；" +
        "应提议轮换或重新协商，别用谁先提出/谁先回复当排先后顺序的理由。"
      : "") +
    (scheduleResults.length ? `\n${scheduleResults.join("\n")}` : "");

  /**
   * **每一条出站消息都要审，不只是回复。**
   *
   * 曾经只审 reply，`contactPerson` 发给别人的消息完全没人把关——
   * 用户收到的那条「看到脏了就随手刷一下」正是走的这条路。
   * 主动发给别人的消息风险更高（对方没找过你，突然收到一条冲他来的话），
   * 反而是唯一没被检查的。
   */
  const outboundNames = new Map(
    ctx.members.map((m) => [m.personId, m.name] as const)
  );

  // 出站消息先审、先落定"拦没拦"——回复的审稿要用得上这个结果（见下）。
  /**
   * **生成器能看见"最近跟这屋里的人说过什么"（context.ts 渲染进了
   * ctx.text），批判器一直看不见。** 生产上真出过：AI 给两位住户发了
   * "你一般几点做饭"，70 秒后又因为房东发来一条新消息，把同一句问话
   * 原样又发了一遍——两人都还没来得及答第一条。生成器的 doctrine 里
   * 明明写着"已经问过的别再问一遍"，但批判器审这条重复消息时，`facts`
   * 里只有名册和本轮工具，压根没有"最近对这个人说过什么"这个信息，
   * 判不出"这是重复"。跟今天早些时候修的名册过期快照是同一类问题：
   * 批判器缺的不是判断力，是生成器已经有、批判器没有的那份事实。
   * 这里现查一份较宽的最近往来记录，按收信人过滤后喂给对应的批判器
   * 调用。
   */
  const recentForCritique = await repo.recentOutbound(sender.householdId, 24);

  /**
   * 抽成函数是因为**这条审核不止跑一次**——2026-09-05 发现的真实漏洞：
   * 批判器打回回复、进入重写阶段时，重写拿到了完整工具集（含
   * `contactPerson`），如果它这时候才调用 `contactPerson` 发消息，
   * 那条消息是在这批审核**跑完之后**才被 push 进 `outbound` 的，
   * 从头到尾没有经过任何审核就会被投递——等于重写阶段发的消息拿到了
   * "先斩后奏、永不复核"的特权，反而是全流程里唯一没人把关的一条。
   * 抽出来是为了重写结束后能对新增的那部分再跑一遍同样的检查，
   * 不新写一份逻辑、不产生"两条审核标准不一致"的风险。
   */
  // TS 的控制流窄化过不了闭包边界（sender 在函数顶部已经判过非空），
  // 这里显式存一份非空引用给闭包用，不然每处 sender.xxx 都会报"可能为 null"
  const senderName = sender.name;
  async function critiqueAndMarkOutbound(msgs: OutboundMessage[]): Promise<void> {
    const batchSummary = msgs
      .map((message) => {
        const name = outboundNames.get(message.personId) ?? "某位住户";
        return `给${name}：${message.text}`;
      })
      .join("\n");
    /**
     * **批量审稿：一整批出站合并成一次 `critiqueBatch` 调用，不再 N 条 N 次。**
     *
     * 之前对每条消息各调一次 `critique`（N 条 = N 次模型往返，各自重发一份
     * rubric）。合并后整批共享一次 rubric system 缓存写入，成本与延迟都从
     * N 次降到 1 次（单条仍走 `critique` 单条路径，行为与原来一致）。
     *
     * **老板定的闸：非敏感出站不进批判器，只有安全敏感主题才走模型复核。**
     * 确定性路径不进模型：
     *  - `scheduleVerified`：正文由已选候选 + 固定模板生成，结构化核对过，
     *    语言批判器不应反过来把正确数字误判成"锁死了另一个时段" → 直接放行；
     *  - 过早的增容逃逸（未结共享资源冲突但排班器没证明无解）→ 直接打回；
     *  - 其余非敏感消息（`hasSafetySensitiveTopic(o.text, args.text)` 未命中）
     *    → 直接 pass，不再调 LLM 批判器；
     *  - 只有命中安全敏感主题的消息进 `needsCritique`，整批升级 sonnet 复核。
     */
    const verdicts: Verdict[] = new Array(msgs.length);
    const needsCritique: Array<{
      msgIndex: number;
      input: Parameters<typeof critique>[0];
    }> = [];
    for (const [i, o] of msgs.entries()) {
      if (o.scheduleVerified) {
        verdicts[i] = {
          verified: true,
          pass: true,
          broke: "",
          why: "结构化排班时段与已选候选一致",
        };
        continue;
      }
      if (
        isPrematureCapacityEscape(
          o.text,
          conflictContextActive,
          scheduleProvenInfeasible
        )
      ) {
        verdicts[i] = {
          verified: true,
          pass: false,
          broke: "0",
          why:
            "这是未结的共享资源冲突，但本轮没有 pickSchedule 返回无候选的证据，" +
            "不能先把加炉具、查插座或多人同时使用说成出路。先按一人独占排完" +
            "所有顺序；只有结构化硬约束确实让排班无解，才考虑增容或并行。",
        };
        continue;
      }
      // **非敏感出站不进批判器。** 日常只靠上面的确定性检查（scheduleVerified /
      // 过早增容逃逸）；其余只有命中安全敏感主题（覆盖入站说的和这条正文，
      // `hasSafetySensitiveTopic` 判）才值得升级 sonnet 复核，否则直接 pass。
      if (!hasSafetySensitiveTopic(o.text, args.text)) {
        verdicts[i] = { verified: true, pass: true, broke: "", why: "" };
        continue;
      }
      const targetName = outboundNames.get(o.personId) ?? "某位住户";
      const withThisPerson = recentForCritique
        // **必须早于本轮开始**——本轮自己刚发的（含正在审的这条本身）
        // 都已经写进库了，不排除的话批判器会拿这条消息跟它自己比对。
        .filter((r) => r.to === targetName && r.sentAt < turnStartedAt)
        .slice(0, 6)
        .map(
          (r) =>
            `${r.direction === "inbound" ? "他说" : "你对他说"}：${r.body
              .replace(/\n/g, " ")
              .slice(0, 60)}`
        );
      needsCritique.push({
        msgIndex: i,
        input: {
          to: targetName,
          /**
           * 共用者规矩、针对个人的事、中性打招呼，三种判法完全不同。
           * **"被说到的人"这个角色是给纠纷场景准备的**——刚加进系统、
           * 这一轮才第一次联系的人，跟任何纠纷都还扯不上关系，硬套这个
           * 角色会把中性的自我介绍当成"针对他的指控"来审，产生假阳性。
           */
          role: o.isIntroduction
            ? "不确定"
            : o.sharedRule
              ? "共用者通知的对象"
              : "不确定",
          said: "",
          facts:
            `${renderBaseFacts()}\n这条是主动发的，起因是 ${senderName} 说：${args.text}` +
            (batchSummary
              ? `\n本批同时准备给其他人的消息如下；这些消息会分别审核，不能因为` +
                `当前这一条只写收件人自己的时段，就断言其他人没被联系：\n${batchSummary}`
              : "") +
            (o.isIntroduction
              ? "\n这个人是这一轮才刚加进系统的，这条是第一次联系、" +
                "自我介绍性质，不是在回应任何投诉或纠纷"
              : "") +
            (o.sharedRule
              ? `\n这是对共用者一样的规矩；模型声明的共用范围（仅供判断语气/` +
                "角色，跟这条消息是不是对他一个人下指令有关；不代表本轮" +
                "计算实际涉及哪些人，那份名单以上面 pickSchedule 候选方案" +
                `里列出的人名为准）：${
                  o.sharedWith ?? "（没说清是哪些人 —— 这本身就是问题）"
                }`
              : "") +
            (withThisPerson.length
              ? `\n最近跟他之间的往来（新到旧）：\n${withThisPerson.join("\n")}`
              : "\n最近没有跟他之间的往来记录"),
          draft: o.text,
        },
      });
    }
    if (needsCritique.length > 0) {
      const batchVerdicts = await critiqueBatch(
        needsCritique.map((n) => n.input)
      );
      for (const [k, n] of needsCritique.entries()) {
        verdicts[n.msgIndex] = batchVerdicts[k];
      }
    }
    // 出站那些不重写（重写要重跑整轮），但**不合格就不发**，并留痕。
    // 宁可少发一条，也不发一条会让人觉得被冤枉的。
    for (const [i, v] of verdicts.entries()) {
      if (!v.pass) {
        const msg = msgs[i];
        console.log("[critic] 拦下一条出站：", v.broke, v.why, msg.text);
        await repo.markCommunication({
          communicationId: msg.communicationId,
          status: "skipped",
          error: `审稿不合格 第${v.broke}条：${v.why}`,
        });
        msg.blocked = true;
        // 被拦草稿没有投递，不能占住本轮重发资格。
        contacted.delete(msg.personId);
        // 拦截理由也留在对象上：调用方（评测报告页）要把"为什么被拦"
        // 显示给人看——那是审稿系统真的在起作用的证据，只标一个 blocked
        // 布尔值等于把最有价值的部分丢了
        msg.blockReason = `第${v.broke}条：${v.why}`;
      }
    }
  }

  await critiqueAndMarkOutbound(outbound);

  /**
   * 回复的审稿放在出站之后（不能并发）：**回复如果说"我去联系他了"，
   * 得先知道那条联系有没有真的发出去。** 第10轮踩过——contactPerson
   * 那条被上面拦下之后，回复里仍然说"我先去听听阿伟那边怎么说"，
   * 这句话在这一轮里其实没发生。把拦截结果喂给回复的批判器，
   * 让 rubric 第7条能查出这种"工具调过、消息没送到"的落差。
   */
  const replyFacts =
    renderBaseFacts() +
    (outbound.length
      ? `\n同一轮还联系了别人：${outbound
          .map(
            (o) =>
              `→${o.blocked ? "【这条被审稿拦下，没有发出去】" : ""}${o.text}`
          )
          .join(" ／ ")}`
      : "\n这一轮没有联系任何其他人");

  /**
   * **模型转述一个代码已经知道答案的事实，转述错了。**
   *
   * "转述这一轮联系有没有真的发出去"——测试里出现频率很高：一轮又一轮，
   * 模型说"我已经联系他了""正在跟他说""这就去问"，而 facts 明明白白
   * 写着那条 `contactPerson` 消息被审稿拦下、根本没发出去。以前这类只
   * 靠批判器（rubric 第7条）主观判断，"有限复核"同样只给一次重写机会，
   * 重写完继续这么说也只能老实发出去。
   *
   * （曾经这里还有一条排班时段的正则硬闸——比对回复里的时刻跟
   * `pickSchedule` 算出的候选集合。撤掉了：正则认不出"引用住户刚说的
   * 到家时间""在问对方偏好几点"这类正常提到时刻的句子，也堵不住"东拼
   * 西凑几个候选里的数字"这种真编造，误伤比抓到的真问题还多。排出来
   * 的全部候选已经作为结构化事实喂进了 `baseFacts`／`replyFacts`
   * （见 `renderBaseFacts`），批判器带着这份事实去核对人和时段、以及
   * 整套方案站不站得住——rubric 6.6 就是干这个的，交给能理解语义的
   * 批判器，比一条只会数字符串比对的正则更适合。）
   *
   * 判定不需要语义理解——**这一轮有没有被拦下的出站消息**是代码已知的
   * 硬事实（`outbound[].blocked`），"回复里有没有用现在时/将来时声称
   * 联系成功"是可枚举的措辞（这份措辞清单本来就已经写进了下面 redo
   * 的提示词里，只是以前只当"提醒"用，没有当"检查"用）。
   *
   * **不要求精确对应"声称联系的是哪一位"**——只要这一轮有任意一条
   * 出站被拦，回复里又出现任意一个"声称联系成功"的表达，就判不合格。
   * 宁可稍微宽松触发、多重写一次，也不要因为想精确匹配"是不是说的
   * 就是被拦的那条"而放过真正的谎言（拦截通常发生在唯一一条出站上，
   * 精确匹配带来的收益很小，复杂度却要高一截）。
   */
  function checkFalseContactClaim(
    text: string
  ): { broke: "0"; why: string } | null {
    const unresolved = outbound.filter((o) => o.blocked && !outbound.some(
      (other) => other.personId === o.personId && !other.blocked
    ));
    const anyBlocked = unresolved.length > 0;
    if (anyBlocked && claimsContactCompletion(text)) {
      const blockedTargets = unresolved
        .map((o) => o.personId)
        .join("、");
      return {
        broke: "0",
        why:
          "回复里像是在说这一轮已经/正在联系到某人，但这一轮发给" +
          `（person_id: ${blockedTargets}）的消息被审稿拦下，没有发出去` +
          "——这一轮这件事没有发生，不管用什么时态描述都不能说成已经" +
          "联系到了或者正在联系，老实说清楚这一步还没做成，或者换一种" +
          "确实做了的事来说。",
      };
    }
    return null;
  }

  function missingSelectedScheduleParticipants(): string[] {
    const selected = [...selectedSchedules.values()].at(-1);
    if (!selected) return [];
    const contactedNames = new Set(
      outbound
        .filter((message) => !message.blocked)
        .map((message) => outboundNames.get(message.personId) ?? "")
    );
    for (const covered of recentlyCovered.values()) {
      contactedNames.add(covered.name);
    }
    // Pre-consented via contactPerson call returning {preConsented:true}.
    for (const personId of preConsentedForSchedule) {
      const name = outboundNames.get(personId);
      if (name) contactedNames.add(name);
    }
    // Pre-consented directly via selfStatedSlotsByWindow: if a participant's selected
    // assignment exactly matches what they self-stated, they authorized their slot via
    // their own words — the model may legitimately skip calling contactPerson for them,
    // but the gate must still treat them as handled (not "missing").
    const selectedWindowLabel = [...selectedSchedules.entries()].at(-1)?.[0];
    if (selectedWindowLabel) {
      const slotMap = selfStatedSlotsByWindow.get(selectedWindowLabel);
      if (slotMap) {
        for (const assignment of selected.plan.assignments) {
          const selfStated = slotMap.get(assignment.name);
          const assignmentSlot = {
            start: formatMinutes(assignment.startMinutes),
            end: formatMinutes(assignment.endMinutes),
          };
          if (scheduleSlotMatchesSelfStatement(selfStated, assignmentSlot)) {
            contactedNames.add(assignment.name);
          }
        }
      }
      // 已对同一精确时段回过「愿意」的人，同样视为已处理——定案/通知回合
      // 不得把已确认的人再判成"未征询"、逼模型去重复联系。
      for (const assignment of selected.plan.assignments) {
        if (contactedNames.has(assignment.name)) continue;
        const member = ctx.members.find((m) => m.name === assignment.name);
        if (!member) continue;
        const assignmentSlot = {
          start: formatMinutes(assignment.startMinutes),
          end: formatMinutes(assignment.endMinutes),
        };
        if (hasDurableConfirmedSlot(member.personId, assignmentSlot)) {
          contactedNames.add(assignment.name);
        }
      }
    }
    return selected.plan.assignments
      .map((assignment) => assignment.name)
      .filter((name) => name !== senderName && !contactedNames.has(name));
  }

  function checkUnconsultedSelectedSchedule(): { broke: "0"; why: string } | null {
    const missing = missingSelectedScheduleParticipants();
    return missing.length
      ? {
          broke: "0",
          why:
            `已经选定多人排班，但本轮没有实际向${missing.join("、")}征询。` +
            "选出方案不是完成协调；现在就用 contactPerson 把各自时段发给" +
            "尚未联系的参与者，不能只把整张表回给当前说话人。",
        }
      : null;
  }

  function checkIncompleteConflictTurn(
    text: string
  ): { broke: "0"; why: string } | null {
    if (
      (!toolsUsed.includes("recordPosition") &&
        !(hasOpenConflictCase && isLowInformationFollowUp(args.text))) ||
      selectedSchedules.size > 0 ||
      outbound.some((message) => !message.blocked)
    ) {
      return null;
    }
    const asksSomething = /[？?]/.test(text);
    const asksConflictDetail =
      asksSomething &&
      /(?:多久|多长|几点|时间|时段|冲突|撞|谁|愿意|同意|可以|能否|能不能|限制|偏好)/.test(
        text
      );
    if (!hasDeferredCoordination(text) && asksConflictDetail) {
      return null;
    }
    return {
      broke: "0",
      why:
        "这是冲突协调轮次（刚记录了新立场，或简短消息正在续接未结冲突），" +
        "但回复没有向当前说话人追问" +
        "任何与冲突有关的缺失信息，本轮也既没选定排班、又没成功联系其他住户。" +
        "信息齐全就现在排；缺其他人的必要信息就现在联系那个人。只确认收到、" +
        "只问姓名或把协调推到以后，都不算推进。",
    };
  }

  /**
   * **代码级硬规则的统一入口。** 以后再发现新的"模型转述代码已知
   * 事实却转述错"的马甲（比如分摊金额），往这里加一个检查函数就够了，
   * 不需要重新搭一套"检测+重写"的脚手架——脚手架（下面的 `verdict`
   * 判定、`isBrokenPromise` 给完整工具集、追加重写循环）是通用的，
   * 各个检查函数只负责回答"这条文本符合我要防的那种转述失真吗"。
   *
   * **只收纯代码就能验证、没有"批判器可能理解错"空间的事实**——排班
   * 时段那条已经证明不适合放这里（语义判断，正则做不了），归还给
   * 批判器；这里只留"这一轮有没有发生"这种是/否问题。
   */
  function checkFactFidelity(
    text: string
  ): { broke: "0"; why: string } | null {
    const unconsultedSchedule = checkUnconsultedSelectedSchedule();
    if (unconsultedSchedule) return unconsultedSchedule;
    if (
      isPrematureCapacityEscape(
        text,
        conflictContextActive,
        scheduleProvenInfeasible
      )
    ) {
      return {
        broke: "0",
        why:
          "这是未结的共享资源冲突，但本轮没有 pickSchedule 返回无候选的证据。" +
          "先按一人独占排完所有顺序并直接推进协调；不能把小电炉、插座或同时开火" +
          "提前当成唯一出路，也不能把设备调查派回给收信人。",
      };
    }
    return checkFalseContactClaim(text) ?? checkIncompleteConflictTurn(text);
  }

  const factFidelityHit = checkFactFidelity(reply);

  /**
   * **确定性低风险闸：这类回复不需要过语言批判器。**
   *
   * 老板拍板取消"提示词大脑验收"后，批判器只对安全敏感主题开放，非敏感回复
   * 本来就一律直接 pass——这道闸的直通结论已被上面的兜底覆盖，保留它是为了
   * 让"这类回复确定性安全"这个判断显式可读、也守住已有的结构断言：
   *  1. `simpleScheduleAffirmation` 的短确认——正文由上面代码生成，已确定性正确；
   *  2. 纯确认/纯知会的短句（`isPureNoticeReply`），**且本轮没有新排班、新联系人、
   *     新规则**（没选定方案 / 没成功发出去的联系 / 没动排班联系人规则工具）。
   *     空转回合里一句"好的，收到"没有任何可被批判的内容。
   */
  const deterministicallySafeReply =
    (simpleScheduleAffirmation && reply === simpleScheduleConfirmationText) ||
    (isPureNoticeReply(reply) &&
      selectedSchedules.size === 0 &&
      !outbound.some((message) => !message.blocked) &&
      !toolsUsed.some((toolName) => TURN_ACTION_TOOLS.has(toolName)));

  // 老板定的闸：日常审稿只靠代码。`checkFactFidelity` 命中 → 打回重写（确定性，
  // 保留）；未命中且不落在上面的确定性低风险闸时，只有命中安全敏感主题（非法
  // 驱逐/自杀自伤/歧视/性骚扰/住房公平，由 hasSafetySensitiveTopic 判，**入站与
  // 回复正文都覆盖**）才升级 sonnet 批判器复核；其余一律直接 pass，不再调 LLM 批判器。
  const safetySensitiveReply = hasSafetySensitiveTopic(reply, args.text);
  const verdict = factFidelityHit
    ? { verified: true, pass: false as const, ...factFidelityHit }
    : deterministicallySafeReply
      ? { verified: true, pass: true as const, broke: "", why: "" }
    : safetySensitiveReply
      ? await critique({
          to: sender.name,
          role: senderRole,
          said: args.text,
          facts: replyFacts,
          draft: reply,
        })
      : { verified: true, pass: true as const, broke: "", why: "" };

  /**
   * **最终这句话有没有真的过审——不是"批判器调没调"。**
   * 初稿过审就是 true；打回之后，这个值要跟着重写/最终修正的真实结果走，
   * 不能因为"发了消息总比不发好"就悄悄伪装成过审。见 `ReplyReview` 定义。
   */
  let replyReview: ReplyReview = verdict.pass
    ? { verified: verdict.verified, pass: true, broke: "", why: verdict.why }
    : { verified: verdict.verified, pass: false, broke: verdict.broke, why: verdict.why };

  if (!verdict.pass) {
    console.log("[critic] 打回：", verdict.broke, verdict.why);
    try {
      /**
       * **重写也要强制走 sendReply，不能信任自由文本。**
       * 第10轮踩过：模型不认同审稿意见时，`redo.text` 里出现的不是重写的
       * 正文，是跟审稿意见对质的话（"不能说我重写，这个判断需要你这边
       * 重新看一下"），这段话原样当成正文发给了住户。跟第7轮
       * MAX_STEPS 兜底那次是同一类错误——自由文本里混着不是给住户看的话，
       * 靠猜不可靠。逼它显式调用 sendReply 交付，不给它把辩解写进正文的空间。
       *
       * **重写这一版不会再被批判器复查，所以喂给它的事实不能只是
       * `verdict.why` 那句转述。** 第14轮踩过：原稿因为"这就去跟大宝
       * 立规矩"被第7条打回（那条联系确实被拦、没发出去），重写把
       * "这就去"换成了"这轮我跟他说完"——时态从将来时改成了过去时，
       * 依据的还是同一个没发生的事实，只是换了个说法就绕开了"现在时/
       * 将来时才查"这条判定规则。原因是重写时只看到 verdict.why 的转述，
       * 没有原始 facts 里"【这条被审稿拦下，没有发出去】"这句硬事实——
       * 直接把 facts 带进来，让它对着同一份事实改，而不是对着别人的
       * 转述猜着改。
       */
      deliveredReply = null;
      /**
       * **第7条（承诺的事这轮做了没）打回时，正确的修法可能不是换个说法，
       * 是真的去做。** 以前这里无论打回原因是什么，重写都只给
       * `sendReply` 一个工具、`toolChoice` 锁死——逼它不敢在正文里撒谎，
       * 但代价是就算它想改口去真的联系人，工具都不在手上，唯一能做的
       * 只有把"我这就去说"改成"我会去说"，承诺依然没兑现，只是换了
       * 时态骗过检查。这本身就是"死代码杜绝新人必须联系到"那次改动
       * （c328ae8）之后仍然留着的同一类缺口，这次一并补上。
       *
       * 后来把"哪些打回给完整工具集"从"只有第7条"推广成下面这个分类器
       * （7 / 0 / 6.5·6.6·6.7 / 被拦出站 1·2·12）——因为这些打回都意味着
       * "这一轮少了某个具体动作"，只给 `sendReply` 只能换措辞救不回来。
       * 其余打回（角色错位、编造事实、语气问题等）仍是纯措辞问题，重写只
       * 有 `sendReply`，不需要、也不该借机去联系别人或重排方案（避免影响面
       * 扩大到无关的打回场景）。
       */
      // 需要"完整工具集重写"的打回：打回原因本身意味着"这一轮少了某个具体
      // 动作"，只给 sendReply 只能换措辞、救不回来。
      //  - "0"：代码判定的硬规则（分了资源却没算过 / 联系被拦却说成已联系）；
      //  - "7"：批判器判承诺没兑现——两者本来就需要重写时拿到完整工具集。
      //  - 6.5/6.6/6.7：调度正确性——时段偏离常理、跟 pickSchedule 真算的
      //    对不上、没排完独占就逃到设备。修法是重新真算
      //    pickSchedule→chooseSchedule，不是换措辞；不给完整工具集，模型只能
      //    把编造的时段再交一遍（real-kitchen"老孙说 19:00 却被排到 20:30"
      //    反复出现，就是这类打回当时只给 sendReply 造成的）。
      //  - 出站被拦且 broke 1/2/12：要在重写里把被拦下的联系重发出去。
      const needsScheduleRecompute =
        ["6.5", "6.6", "6.7"].includes(verdict.broke.trim());
      const needsBlockedOutboundRecovery =
        outbound.some((message) => message.blocked) &&
        ["1", "2", "12"].includes(verdict.broke.trim());
      const isBrokenPromise =
        verdict.broke.trim() === "7" ||
        verdict.broke.trim() === "0" ||
        needsScheduleRecompute ||
        needsBlockedOutboundRecovery;
      /**
       * **根治，不再按"哪种具体动作"逐个开口子。**
       *
       * 第7条（承诺没兑现）连续在同一个会话里改了三次：先只给
       * `contactPerson`（ce234a6，覆盖"该联系人却没联系"）；接着发现
       * "该排方案却没排" 也是第7条命中，被迫单独再给 `pickSchedule`；
       * 这个模式会一直重复——以后随便一个新工具、只要它对应"某个该做
       * 的具体动作"，都可能在批判器抓到"承诺没兑现"时被同样漏掉，
       * 每次都要我回来手动加一行。**这不是缺一行代码，是这条路径的
       * 设计本身在按"动作种类"枚举，而动作种类是枚举不完的。**
       *
       * 改法：这些打回命中时，直接给重写**跟主生成一样的完整工具集**，
       * 不再判断"是哪种动作"——模型自己知道该调哪个工具去把承诺兑现或把
       * 排班重算，不需要代码替它猜。多给的这些工具在其余打回原因下依然
       * 不会被打开（`isBrokenPromise` 为 false 时 `redoTools` 还是只有
       * `sendReply`），影响面没有扩大到无关的打回场景。
       */
      /**
       * **第7条、代码规则0和 6.5/6.6/6.7 调度正确性打回都无条件补齐排班
       * 工具，不能只 spread `activeTools`。** `pickSchedule` 进不进
       * `activeTools`，取决于路由用本轮消息原文猜的话题（`topicHitsConflict`）
       * ——真实复现过最后一句只是“我刚才不是说了吗”，路由没命中，但审稿
       * 已经确认它在空口承诺稍后排。审稿命中本身比关键词路由更可靠。
       */
      const redoTools: Record<string, (typeof tools)[keyof typeof tools]> =
        isBrokenPromise
          ? {
              ...activeTools,
              // 第7条可能是“答应稍后排、但本轮没排”，6.5/6.6/6.7 则是
              // 时段没真算/算错——都不能再依赖本轮原文是否被路由成
              // conflict，两个排班工具一律补齐。
              pickSchedule: tools.pickSchedule,
              chooseSchedule: tools.chooseSchedule,
              sendReply: tools.sendReply,
            }
          : { sendReply: tools.sendReply };
      // 重写期间如果调用 contactPerson，新消息会 push 到这同一个
      // outbound 数组——记下重写前的长度，重写完只审"新增的那一截"，
      // 不重复审已经审过、已经落定的那些
      const outboundLenBeforeRedo = outbound.length;
      const redoResult = await generateText({
        abortSignal: turnAbortSignal(),
        model: getLanguageModel(modelId),
        system: [
          {
            role: "system" as const,
            content: doctrine,
            // 同上：这一轮如果批判器打回，这段会跟主生成调用共享
            // 同一份 doctrine 内容，开缓存能命中主调用已经写入的那份
            providerOptions: { anthropic: { cacheControl: { type: "ephemeral" } } },
          },
          { role: "system" as const, content: runtime },
        ],
        messages: [
          ...history,
          { role: "user" as const, content: args.text },
          { role: "assistant" as const, content: reply },
          {
            role: "user" as const,
            content:
              `【这不是住户说的，是审稿意见】\n` +
              (verdict.broke.trim() === "0"
                ? "你刚才那条不合格（代码判定，不是准则第几条）：\n"
                : `你刚才那条第${verdict.broke}条不合格：\n`) +
              `${verdict.why}\n\n【这一轮的事实，重写要跟这个对得上】\n${replyFacts}\n\n` +
              (needsScheduleRecompute
                ? "这次打回的是调度正确性：你给的时段偏离常理、跟 `pickSchedule` 真算的" +
                  "对不上、或没真算就拍了时段。事实里已经有「已选定候选N」那一行，" +
                  "就照已选定那一行把时段抄对；还没有选定方案，" +
                  "就**现在真的调 `pickSchedule` 重新算一版，再调 `chooseSchedule` 选定" +
                  "（默认候选一），最后照着选定的结果写时段**——不能只换措辞，也不准在正文" +
                  "里心算时段、或把上一版编的时段换个说法再交一遍。还缺谁的可用时间没问清，" +
                  "就先调 `contactPerson` 去问、问齐了再排；确实还不齐且这轮已经问过、只是" +
                  "在等回复，才可以说还在等。\n\n"
                : isBrokenPromise
                  ? "你承诺了一件事，但这轮实际没有做到——**现在真的去做**：" +
                    "该联系人、该排方案、该记什么，你手上有跟正常这一轮" +
                    "一样的全部工具，自己判断该调哪个，做完再调 `sendReply` " +
                    "交付，回复里就可以如实说已经做了。\n\n" +
                    "**只有两种情况允许不调工具、直接改措辞**：" +
                    "①确实做不了（联系不上、对方不在名册里）；" +
                    "②这一步所需的信息本来就不全，且**你已经在更早的轮次" +
                    "或本轮别的步骤里问过了**，现在只是等对方回——" +
                    "这种情况可以说「等他们回」，但不能是「这轮才第一次" +
                    "意识到该问、却决定不问、只说回头再问」这种拖延。\n\n" +
                    "**不属于上面两种情况、只是嫌麻烦不想现在做，一律不" +
                    "合格**——「这事我记下了，回头去问」「打算联系他」这类" +
                    "说法只有在真符合①②时才能用，不是随便换个时态就能用的" +
                    "免检词。用了这类说法，回复里必须同时体现②的条件成立" +
                    "（比如提一句「之前问过」「还没等到回音」），不能空说。\n\n"
                : "") +
              "重写一条，调 sendReply 把要发给对方的那句话交出来。" +
              "上面事实里标了「被审稿拦下，没有发出去」的联系，" +
              (isBrokenPromise
                ? "如果你没有在这次重写里真的把该做的事做了，"
                : "") +
              "这轮就是没有发生——不管用什么时态描述，都不能说成已经联系到了" +
              "或者正在联系。具体说：『我正/正在/已经/这就跟他说/商量/联系』" +
              "这类话都不能用（第16轮踩过：把『正在』换成『正去』照样是同一个" +
              "问题，文字游戏绕不开这条）。",
          },
        ],
        tools: redoTools,
        toolChoice: "required",
        // 完整工具集这条路径可能需要比"只有 sendReply"时更多步（比如先
        // recordPosition 再 pickSchedule 再 sendReply；调度正确性打回则要
        // pickSchedule→chooseSchedule→sendReply），预算从 3 步放宽到 4 步，
        // 仍然远低于主生成的 MAX_STEPS=6——这是补救性的单次重写，
        // 不该比正常一轮更奢侈。
        stopWhen: [hasToolCall("sendReply"), stepCountIs(4)],
      });
      /**
       * **同一个盲区，第三处发现（2026-09-05）：** 主生成、MAX_STEPS
       * 兜底、强制打招呼补发都已经在聚合 `toolsUsed`，唯独这条"第一层
       * 重写"从一开始就没聚合过——今天泛化排班硬规则时用 `coliving-eval`
       * 全量跑批才暴露：重写期间真的调用了 `pickSchedule`/`contactPerson`、
       * `scheduleResults`/`outbound` 都确实被更新了，但外部看到的
       * `toolsUsed` 里没有它们，`mustUseAnyOfTools` 这类断言会**误判
       * 失败**——不是这次改动引入了新 bug，是这次改动第一次让"重写期间
       * 调用工具"这条路径被真实触发到了，才照见这个一直存在的盲区。
       */
      for (const step of redoResult.steps) {
        for (const call of step.toolCalls ?? []) {
          toolsUsed.push(call.toolName);
        }
      }
      const fixed = stripMarkdown((deliveredReply ?? "").trim());
      if (fixed) {
        reply = fixed;
      }

      /**
       * **代码可验证的客观事实转述失真，不是主观分歧——值得比"有限
       * 复核"多给几次机会。这段循环不是排班专属的，是给
       * `checkFactFidelity` 里所有检查函数通用的收尾。**
       *
       * 2026-09-05 真实复现（排班）：三人厨房场景里，批判器连续两次
       * 正确打回"回复时段跟 pickSchedule 算出的对不上"，重写完还是
       * 没对齐（把新旧两个版本的时段拼在一句话里，读起来自相矛盾），
       * "有限复核"只查一次就放弃，这条自相矛盾的消息原样发给了住户。
       *
       * 同一天泛化出第二个马甲（联系状态）：测试里出现频率比排班数字
       * 对不上还高——模型说"我已经联系他了""正在跟他说"，而 facts
       * 明明白白写着那条 `contactPerson` 消息被拦下、没发出去。
       * 两者是同一种病：**转述一个代码已经知道答案的事实，转述错了**。
       *
       * 为什么这里可以打破"只重写一次"的惯例：`checkFactFidelity` 里
       * 每个检查函数判的都是纯代码可验证的事实（时刻在不在
       * `pickSchedule` 算出的集合里、出站消息有没有真的被拦），
       * **不存在"批判器可能理解错"的空间**。主观分歧才有"越改越糟、
       * 不如老实发出去"的顾虑，客观事实不存在这个顾虑，多试几次只会
       * 更接近正确答案，不会更糟。复查本身也不花模型调用（纯代码判断），
       * 只有真要重写时才调模型。
       *
       * 有界（最多再试 2 次）而不是循环到通过：万一某个检查函数本身
       * 就没法通过话术满足（理论上不应该，但留个上限保险），不能真的
       * 死循环。
       */
      let factFidelityAttempts = 0;
      while (checkFactFidelity(reply) && factFidelityAttempts < 2) {
        factFidelityAttempts++;
        const stillWrong = checkFactFidelity(reply)!;
        console.log(
          `[fact-fidelity-retry] 第${factFidelityAttempts}次追加重写：`,
          stillWrong.why
        );
        const retryOutboundLen = outbound.length;
        deliveredReply = null;
        /**
         * **必须显式塞 `tools.pickSchedule`，不能只 spread `activeTools`。**
         * 第一版这里犯了跟"没调 pickSchedule 就编时段"完全同类的错——
         * 如果失败原因是"压根没调过 pickSchedule"，光靠重写措辞救不回来，
         * 模型结构上就没有调用它的能力，两次重试等于白烧。
         *
         * 光 spread `activeTools` 还不够：`pickSchedule` 是否在
         * `activeTools` 里，取决于路由用**本轮消息原文**匹配到的话题
         * （`topicHitsConflict`，见 `routeOn: args.text`）——真实复现过，
         * 像"我随时都行，半小时够了"这种回应句本身不含"厨房/排班"关键词，
         * 路由判不出冲突话题，`pickSchedule` 从一开始就不在 `activeTools`
         * 里，重试拿到的还是同一个空集合，两次重试仍然白烧。
         *
         * 但"硬规则命中"这件事本身就是"这一轮需要这个工具"的**确定
         * 信号**，比路由靠关键词猜话题可靠得多——命中就无条件把
         * `pickSchedule` 塞进这次重写的工具集，不依赖路由判断对不对。
         * `contactPerson` 本身就是核心链路常驻工具（见工具分层注释），
         * 不受路由影响，不需要额外补。
         */
        const retryResult = await generateText({
          abortSignal: turnAbortSignal(),
          model: getLanguageModel(modelId),
          system: [
            {
              role: "system" as const,
              content: doctrine,
              providerOptions: {
                anthropic: { cacheControl: { type: "ephemeral" } },
              },
            },
            { role: "system" as const, content: runtime },
          ],
          messages: [
            ...history,
            { role: "user" as const, content: args.text },
            { role: "assistant" as const, content: reply },
            {
              role: "user" as const,
              content:
                `【这不是住户说的，是代码核对结果】\n${stillWrong.why}\n\n` +
                `【这一轮的事实】\n${renderBaseFacts()}\n\n` +
                "如果事实里没有 pickSchedule 算出的方案，先调 pickSchedule" +
                "把候选排出来，再照着结果说话——不要在正文里自己心算时段。" +
                "只说一个版本的时段，不要同时提新旧两个版本让对方猜、" +
                "不要用「或者」「之间」这类模糊词回避精确对齐。" +
                "如果是联系状态的问题：这一轮没发出去就是没发出去，" +
                "老实说清楚还没联系到，或者说清楚接下来打算怎么做，" +
                "不能用任何时态说成已经联系到了或者正在联系。" +
                "最后调 sendReply 把改好的这句话交出来。",
            },
          ],
          tools: {
            ...activeTools,
            pickSchedule: tools.pickSchedule,
            chooseSchedule: tools.chooseSchedule,
            sendReply: tools.sendReply,
          },
          toolChoice: "required",
          // 可能要先调 pickSchedule 再 chooseSchedule 再 sendReply，给够步数余量
          stopWhen: [hasToolCall("sendReply"), stepCountIs(4)],
        });
        // 同一个盲区第四处——这条循环本身是这次泛化才新写的，写的时候
        // 就该顺手聚合，结果还是漏了，说明这个盲区已经不是"忘了"这么
        // 简单，值得往后每次新增 generateText 调用时，把"这次调用的
        // toolCalls 有没有推进 toolsUsed"当成写完就要检查的一项。
        for (const step of retryResult.steps) {
          for (const call of step.toolCalls ?? []) {
            toolsUsed.push(call.toolName);
          }
        }
        const retryFixed = stripMarkdown((deliveredReply ?? "").trim());
        if (retryFixed) {
          reply = retryFixed;
        }
        const retryNewOutbound = outbound.slice(retryOutboundLen);
        if (retryNewOutbound.length > 0) {
          await critiqueAndMarkOutbound(retryNewOutbound);
        }
      }

      /**
       * **重写期间新发的消息，补审一遍。** 2026-09-05 真实发现：
       * 重写拿到完整工具集后，如果这时候才调 `contactPerson`，那条
       * 消息是在最初那批出站审核跑完之后才 push 进 `outbound` 的，
       * 从来没被检查过就会直接投递——反而是全流程里唯一没人把关的。
       */
      const newOutbound = outbound.slice(outboundLenBeforeRedo);
      if (newOutbound.length > 0) {
        await critiqueAndMarkOutbound(newOutbound);
      }

      /**
       * **重写的结果也要再查一遍，不能写完就当合格。** 2026-09-05
       * 真实发现：批判器打回"承诺没兑现"、给了完整工具集重写，但重写
       * 可以选择"这一步不该做"这条路径、只换个措辞就蒙混过去
       * ——比如信息明明不全、这轮也没去问，却直接说"回头去问"，
       * 这类话在字面上是将来时、不撒谎，但违反了 core.md 闸五
       * （信息不全时延后必须先问）。**这条路径以前完全没人复查**，
       * 重写永远被当成"改完就对"。
       *
       * 主观分歧最多只再给一次**聚焦的最终修正机会**（只带 sendReply，
       * 喂完整最新事实和明确的审稿理由），再复核一次收尾——比死循环重写
       * 更克制，也比"打回一次就摆烂"更负责。这次复核的结论就是最终
       * `replyReview`：还不合格，宁可保留这条可交付的消息（不让用户
       * 收不到任何回复），但**评测和汇总必须看到红灯**，不能再假装通过。
       */
      const renderNewReplyFacts = () =>
        renderBaseFacts() +
        (outbound.length
          ? `\n同一轮还联系了别人：${outbound
              .map(
                (o) =>
                  `→${o.blocked ? "【这条被审稿拦下，没有发出去】" : ""}${o.text}`
              )
              .join(" ／ ")}`
          : "\n这一轮没有联系任何其他人");
      // 重写稿必须重新过与首稿完全相同的代码硬闸；只交给语言批判器会让
      // “首稿被确定性拦下、重写原样复读却变绿”成为可能。
      const redoFactFidelityHit = checkFactFidelity(reply);
      // 重写稿同样只对安全敏感主题升级 sonnet 复核；其余直接 pass，不调 LLM。
      const redoVerdict = redoFactFidelityHit
        ? { verified: true, pass: false as const, ...redoFactFidelityHit }
        : hasSafetySensitiveTopic(reply, args.text)
          ? await critique({
              to: sender.name,
              role: senderRole,
              said: args.text,
              facts: renderNewReplyFacts(),
              draft: reply,
            })
          : { verified: true, pass: true as const, broke: "", why: "" };
      if (redoVerdict.pass) {
        replyReview = {
          verified: redoVerdict.verified,
          pass: true,
          broke: "",
          why: redoVerdict.why,
        };
      } else {
        console.log(
          "[critic] 重写后复核仍不合格，做最后一次聚焦修正：",
          redoVerdict.broke,
          redoVerdict.why
        );
        try {
          deliveredReply = null;
          // 与首轮 isBrokenPromise 同一份分类：6.5/6.6/6.7 调度正确性打回在
          // 最后一次聚焦修正里同样要给完整工具集，不能只剩 sendReply。
          const finalNeedsAction =
            redoVerdict.broke.trim() === "7" ||
            redoVerdict.broke.trim() === "0" ||
            ["6.5", "6.6", "6.7"].includes(redoVerdict.broke.trim()) ||
            (outbound.some((message) => message.blocked) &&
              ["1", "2", "12"].includes(redoVerdict.broke.trim()));
          const finalTools: Record<string, (typeof tools)[keyof typeof tools]> =
            finalNeedsAction
              ? {
                  ...activeTools,
                  pickSchedule: tools.pickSchedule,
                  chooseSchedule: tools.chooseSchedule,
                  sendReply: tools.sendReply,
                }
              : { sendReply: tools.sendReply };
          const finalOutboundLen = outbound.length;
          const finalFix = await generateText({
            abortSignal: turnAbortSignal(),
            model: getLanguageModel(modelId),
            system: [
              {
                role: "system" as const,
                content: doctrine,
                providerOptions: {
                  anthropic: { cacheControl: { type: "ephemeral" } },
                },
              },
              { role: "system" as const, content: runtime },
            ],
            messages: [
              ...history,
              { role: "user" as const, content: args.text },
              { role: "assistant" as const, content: reply },
              {
                role: "user" as const,
                content:
                  "【这不是住户说的，是审稿意见——这是最后一次修正机会】\n" +
                  `第${redoVerdict.broke}条仍不合格：${redoVerdict.why}\n\n` +
                  `【这一轮最新的完整事实】\n${renderNewReplyFacts()}\n\n` +
                  (finalNeedsAction
                    ? "这次不能只换措辞：先调必要的工具，把该排的方案排出来、该联系的人联系到；完成后再调 sendReply 交付正文。"
                    : "只做一件事：调 sendReply，把改好后真正要发给对方的那句话交出来，") +
                  "对着上面的理由和事实改，不要重复同一个问题。",
              },
            ],
            tools: finalTools,
            toolChoice: finalNeedsAction
              ? "required"
              : { type: "tool", toolName: "sendReply" },
            ...(finalNeedsAction
              ? { stopWhen: [hasToolCall("sendReply"), stepCountIs(4)] }
              : {}),
          });
          for (const step of finalFix.steps) {
            for (const call of step.toolCalls ?? []) {
              toolsUsed.push(call.toolName);
            }
          }
          const finalText = stripMarkdown((deliveredReply ?? "").trim());
          if (finalText) {
            reply = finalText;
          }
          const finalNewOutbound = outbound.slice(finalOutboundLen);
          if (finalNewOutbound.length > 0) {
            await critiqueAndMarkOutbound(finalNewOutbound);
          }
        } catch (finalError) {
          console.log(
            "[critic] 最后一次聚焦修正失败，沿用上一版重写稿：",
            finalError instanceof Error ? finalError.message : String(finalError)
          );
        }
        const finalFactFidelityHit = checkFactFidelity(reply);
        // 最后一次修正稿同样只对安全敏感主题升级 sonnet 复核；其余直接 pass。
        const finalVerdict = finalFactFidelityHit
          ? { verified: true, pass: false as const, ...finalFactFidelityHit }
          : hasSafetySensitiveTopic(reply, args.text)
            ? await critique({
                to: sender.name,
                role: senderRole,
                said: args.text,
                facts: renderNewReplyFacts(),
                draft: reply,
              })
            : { verified: true, pass: true as const, broke: "", why: "" };
        replyReview = {
          verified: finalVerdict.verified,
          pass: finalVerdict.pass,
          broke: finalVerdict.broke,
          why: finalVerdict.why,
        };
        if (!replyReview.pass) {
          console.log(
            "[critic] 最终修正后仍不合格——保留可交付消息，但 replyReview 标红：",
            finalVerdict.broke,
            finalVerdict.why
          );
        }
      }
    } catch (error) {
      // 改不动就用原来那条——有消息总好过没消息，但 replyReview 保持
      // 上面设的失败态（初次打回的结论），不能假装重写成功了。
      console.log(
        "[critic] 重写失败，用原稿：",
        error instanceof Error ? error.message : String(error)
      );
    }
  }

  // ── 选定方案后的确定性收口：漏掉的参与者由代码补发，不再靠模型记得 ────
  // 审稿/重写全部走完，仍可能有人漏掉——模型单轮里既要 pickSchedule →
  // chooseSchedule → 逐个 contactPerson → sendReply，常常漏掉一个或几个
  // 参与者，打回后重写也仍漏（Codex 全量回归实测）。这里对所有仍缺征询的
  // 参与者，按其在该方案里的 assignment 调 enqueueScheduleContact（与
  // contactPerson 排班分支共用同一入队函数）。这是能力/事实补全——联系人
  // 真的会收到消息，不是替大脑写当前说话人的回复正文；回复正文只由大脑在
  // sendReply/审稿重写里交付。只有补发也到不了的人（无地址/竞态/名册外）
  // 才会被 checkUnconsultedSelectedSchedule 标成红灯。
  // 简单肯定回合不触发收口（代码短路落锤的回合不会新选方案，即使有也不该
  // 由代码替它联系人）。
  const selectedEntry = [...selectedSchedules.entries()].at(-1);
  if (!simpleScheduleAffirmation && selectedEntry) {
    const [selectedWindowLabel, selection] = selectedEntry;
    const slotByParticipant = new Map<string, { start: string; end: string }>();
    for (const assignment of selection.plan.assignments) {
      slotByParticipant.set(assignment.name, {
        start: formatMinutes(assignment.startMinutes),
        end: formatMinutes(assignment.endMinutes),
      });
    }
    for (const name of missingSelectedScheduleParticipants()) {
      const assignmentSlot = slotByParticipant.get(name);
      if (!assignmentSlot) continue;
      const funnelResult = await enqueueScheduleContact(
        name,
        selectedWindowLabel,
        assignmentSlot
      );
      console.log(
        funnelResult.ok && !funnelResult.skipped
          ? `[schedule-funnel] 自动补发征询给 ${name}（${selectedWindowLabel} ${assignmentSlot.start}-${assignmentSlot.end}）`
          : `[schedule-funnel] ${name} 无需补发：${funnelResult.reason}`
      );
    }
  }

  // **最终落锤：简单肯定覆盖，所有审稿/重写路径之后、入库之前最后执行一次。**
  // 批判/重写路径可能把短句替换成整张方案——在这里用确定性文本收口，
  // 保证入库和投递的是经过代码控制的短句，而非模型重写结果。
  if (simpleScheduleAffirmation && simpleScheduleConfirmationText) {
    reply = simpleScheduleConfirmationText;
    replyReview = { verified: true, pass: true, broke: "", why: "" };
  }

  // ── 落库：入站消息、回复本身也算一次 communication ──
  const inboundId = await repo.appendMessage({
    conversationId,
    personId: sender.personId,
    direction: "inbound",
    channel,
    body: args.text,
  });
  // 设计稿第十四点的「Human Response」那一环：把他的回话接回是哪条沟通引出来的。
  // **确定性匹配，不交给模型**——链断了就再也补不回来。
  if (inboundId) {
    await repo.linkResponse({ personId: sender.personId, messageId: inboundId });
  }

  let replyCommunicationId: string | null = null;
  if (reply) {
    const did = await ensureDecision("reply_only");
    replyCommunicationId = await repo.queueCommunication({
      householdId: sender.householdId,
      decisionId: did,
      caseId: activeCaseId,
      toPersonId: sender.personId,
      channel,
      purpose: "回复本人",
      body: reply,
    });
    await repo.appendMessage({
      conversationId,
      personId: sender.personId,
      direction: "outbound",
      channel,
      body: reply,
      communicationId: replyCommunicationId,
    });
  }

  return {
    reply,
    replyReview,
    scheduleFacts: [...scheduleResults],
    replyCommunicationId,
    // 审稿拦下的不交给调用方投递
    outbound: outbound.filter((o) => !o.blocked),
    /**
     * **含被拦下的那些**，只读、不要拿去投递。
     *
     * 上面那个 `outbound` 必须保持过滤后的语义（调用方拿到就发），
     * 所以被拦下的消息以前对外完全不可见——但"这条为什么被拦"恰恰是
     * 复核时最该看到的东西（评测报告页要显示它，用户要据此判断审稿
     * 拦得对不对）。分成两个字段，投递安全和可观测性都不牺牲。
     */
    allOutbound: outbound,
    decisionId,
    modules: loadedModuleIds,
    promptChars: chars,
    toolsUsed,
    unknownSender: false,
    usage: sumUsage(result.steps),
    turnStartedAt,
  };
}
