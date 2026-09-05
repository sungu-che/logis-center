pub fn cosine_similarity(a: &[f32], b: &[f32]) -> f32 {
    let dot_product: f32 = a.iter().zip(b.iter()).map(|(x, y)| x * y).sum();
    let norm_a: f32 = a.iter().map(|x| x * x).sum::<f32>().sqrt();
    let norm_b: f32 = b.iter().map(|x| x * x).sum::<f32>().sqrt();
    if norm_a == 0.0 || norm_b == 0.0 { 0.0 } else { dot_product / (norm_a * norm_b) }
}

// =====================================================================
// 🌟 [STANZA IMPROVEMENT] 언어 중립(Language-Agnostic) 형태·구문 판별 엔진
// ---------------------------------------------------------------------
// 판별 근거는 아래 4가지뿐이며, 전부 언어에 무관한 보편 자원입니다.
//   ① UD UPOS 태그셋      (vocab.json 의 pos.upos 배열 — 전 언어 공통 규격)
//   ② UD DEPREL 태그셋    (vocab.json 의 depparse.deprel 배열 — 전 언어 공통 규격)
//   ③ Stanza Lemma 출력   (표면형-원형 차이로 굴절/교착 여부를 모델이 직접 알려줌)
//   ④ 문자열 구조 규칙    (숫자 밀도 / 구분자 — 문자 체계와 무관)
// 특정 언어의 어휘·조사·어미 사전은 일절 사용하지 않습니다.
// =====================================================================

/// [PHASE 1] UD UPOS 중 개체명(PII)이 될 수 없는 태그 — 전 언어 공통
const UPOS_HARD_REJECT: &[&str] = &[
    "VERB", "AUX", "ADV", "ADP", "PART", "SCONJ", "CCONJ", "CONJ",
    "DET", "PRON", "INTJ", "PUNCT", "SYM",
];

/// [PHASE 1] 개체명 후보로 인정되는 핵심 체언 태그 — 전 언어 공통
const UPOS_STRONG_ENTITY: &[&str] = &["NOUN", "PROPN"];

/// [PHASE 1] 단독으로는 개체명 근거가 되지 못하고 보조 근거(구문/복합어)가 필요한 태그
const UPOS_WEAK_ENTITY: &[&str] = &["ADJ", "NUM", "X"];

/// UPOS 서브타입(`NOUN:xxx` 형태) 제거 후 상위 태그만 반환
fn upos_base(tag: &str) -> &str {
    match tag.find(':') {
        Some(i) => &tag[..i],
        None => tag,
    }
}

/// UD DEPREL 서브타입(`nsubj:pass`, `flat:name` 등) 제거 후 소문자 상위 레이블 반환
fn deprel_base(label: &str) -> String {
    let l = label.to_lowercase();
    match l.find(':') {
        Some(i) => l[..i].to_string(),
        None => l,
    }
}

/// [PHASE 2] UD 수식어·기능어 의존관계 → 개체명 기각 근거 (전 언어 공통)
fn is_modifier_deprel(label: &str) -> bool {
    matches!(
        deprel_base(label).as_str(),
        "acl" | "advcl" | "advmod" | "amod" | "aux" | "cop" | "case" | "mark"
            | "cc" | "det" | "discourse" | "expl" | "punct" | "dep"
    )
}

/// [PHASE 2] UD 체언 논항·복합어 의존관계 → 개체명 후보 근거 (전 언어 공통)
fn is_nominal_deprel(label: &str) -> bool {
    matches!(
        deprel_base(label).as_str(),
        "nsubj" | "obj" | "iobj" | "obl" | "nmod" | "flat" | "compound"
            | "appos" | "conj" | "root" | "vocative" | "list" | "nummod"
    )
}

/// [PHASE 4] 구분자 포함 여부 (전화·주민번호 등 식별번호의 보편적 구조 신호)
fn has_identifier_separator(word: &str) -> bool {
    word.chars().any(|c| matches!(c, '-' | '.' | '/' | '+' | '(' | ')' | ' ' | '_'))
}

/// [PHASE 4] 식별번호 후보가 실제 식별번호 '구조'인지 검증.
/// 언어별 단위 사전(도/명/원 등) 없이, 숫자 개수와 구분자 유무만으로 판정하므로
/// 어떤 문자 체계에서도 동일하게 동작합니다. ('38도','119에','24절기','12일' → 전부 기각)
fn is_valid_identifier_shape(word: &str, base_target: &str) -> bool {
    let digits = word.chars().filter(|c| c.is_ascii_digit()).count();
    let sep = has_identifier_separator(word);

    match base_target {
        // 이메일: 로컬파트@도메인 구조와 도메인 내 점(.) 존재를 요구
        "email" => {
            if let Some(at) = word.find('@') {
                let domain = &word[at + 1..];
                !word[..at].is_empty() && domain.contains('.') && domain.len() >= 4
            } else {
                false
            }
        }
        // 주민등록/사회보장번호류: 최소 8자리 이상 숫자. 구분자가 없으면 10자리 이상 요구
        "national_id" => (digits >= 8 && sep) || digits >= 10,
        // 연락처: 구분자 없는 순수 숫자열 9자리 이상, 또는 구분자 포함 7자리 이상
        "contact_number" => (digits >= 9) || (digits >= 7 && sep),
        _ => false,
    }
}

/// [PHASE 3] Stanza Lemma 출력과 표면형을 비교하여 '굴절/교착이 일어난 토큰'인지 판정.
/// 접두 일치(prefix) / 접미 일치(suffix) 양쪽을 모두 검사하므로
/// 교착어(한국어·일본어·터키어), 굴절어(러시아어·독일어), 고립어(중국어)를 함께 커버합니다.
fn is_inflected_surface(surface: &str, lemma: &str) -> bool {
    if lemma.trim().is_empty() { return false; }
    let s: String = surface.chars().filter(|c| c.is_alphanumeric()).collect();
    let l: String = lemma.chars().filter(|c| c.is_alphanumeric()).collect();
    if l.is_empty() || s.is_empty() { return false; }
    if s == l { return false; }
    let sc = s.chars().count();
    let lc = l.chars().count();
    // 원형이 표면형의 앞/뒤에 포함되며 길이가 더 짧다면 굴절이 발생한 것으로 간주
    (sc > lc) && (s.starts_with(&l) || s.ends_with(&l) || s.contains(&l))
}

/// [PHASE 3] Lemma 를 이용한 언어 중립 접미 절단.
/// 언어별 조사/어미 목록 대신 모델이 산출한 원형을 그대로 신뢰하여 잘라냅니다.
fn trim_surface_by_lemma(surface: &str, lemma: &str) -> Option<String> {
    if !is_inflected_surface(surface, lemma) { return None; }
    let l: String = lemma.chars().filter(|c| c.is_alphanumeric()).collect();
    if l.chars().count() < 2 { return None; }
    if surface.starts_with(&l) && surface.chars().count() > l.chars().count() {
        return Some(l);
    }
    if let Some(idx) = surface.rfind(&l) {
        // 원형이 표면형 뒤쪽에 붙은 형태(접두 굴절)는 원형만 남깁니다.
        if idx > 0 { return Some(l); }
    }
    None
}

/// 형태·구문 판별 결과
#[derive(Debug, Clone)]
pub struct MorphVerdict {
    pub accept: bool,
    pub reason: String,
}

impl MorphVerdict {
    fn ok(reason: &str) -> Self { Self { accept: true, reason: reason.to_string() } }
    fn no(reason: &str) -> Self { Self { accept: false, reason: reason.to_string() } }
}

/// [PHASE 1 + 2 + 4] 개체명 후보 최종 판정 (언어 중립).
/// - identifier 계열은 구조 검증으로 대체
/// - PROPN 단독 통과 금지: UD DEPREL 체언 관계 또는 복합 체언 구성일 때만 인정
/// - 전 토큰이 UD 수식어 관계이면 강제 기각
pub fn evaluate_entity_candidacy(
    surface: &str,
    words: &[String],
    tags: &[&str],
    deprels: Option<&[String]>,
    lemmas: Option<&[String]>,
    base_target: &str,
    is_sub_language: bool,
) -> MorphVerdict {
    // ── 0) 식별번호 계열: 형태소가 아니라 '구조'로 판정 (언어 무관) ──
    if matches!(base_target, "email" | "contact_number" | "national_id") {
        return if is_valid_identifier_shape(surface, base_target) {
            MorphVerdict::ok("IDENTIFIER-SHAPE 검증 통과")
        } else {
            MorphVerdict::no("식별번호 구조(숫자 밀도/구분자) 미충족")
        };
    }

    // ── 1) 유효 토큰 수집 (구두점·기호 제외) ──
    let mut core: Vec<usize> = Vec::new();
    for (i, w) in words.iter().enumerate() {
        if i >= tags.len() { break; }
        if w.chars().any(|c| c.is_alphanumeric()) {
            let t = upos_base(tags[i]);
            if t != "PUNCT" && t != "SYM" { core.push(i); }
        }
    }

    if core.is_empty() {
        // 메인 언어와 다른 표기(로마자 약어 등)는 태거 신뢰도가 낮으므로 최소 조건으로 구제
        let alnum = surface.chars().filter(|c| c.is_alphanumeric()).count();
        if is_sub_language && alnum >= 2 {
            return MorphVerdict::ok("SUB-LANGUAGE 구제 (태거 신뢰도 낮음)");
        }
        return MorphVerdict::no("유효 토큰 없음 (전부 구두점/기호)");
    }

    // ── 2) UPOS 1차 게이트 ──
    let mut has_strong = false;
    let mut has_weak = false;
    let mut all_hard_reject = true;
    for &i in &core {
        let t = upos_base(tags[i]);
        if UPOS_STRONG_ENTITY.contains(&t) { has_strong = true; }
        if UPOS_WEAK_ENTITY.contains(&t) { has_weak = true; }
        if !UPOS_HARD_REJECT.contains(&t) { all_hard_reject = false; }
    }

    if all_hard_reject {
        if is_sub_language {
            return MorphVerdict::ok("SUB-LANGUAGE 구제 (UPOS 기각 면제)");
        }
        return MorphVerdict::no("UD UPOS 전량 비체언(용언/부사/조사/접속사 등)");
    }

    // ── 3) UD DEPREL 교차 검증 (Phase 2 핵심) ──
    if let Some(rels) = deprels {
        let mut nominal_support = false;
        let mut modifier_hits = 0usize;
        let mut checked = 0usize;
        for &i in &core {
            if i >= rels.len() { continue; }
            checked += 1;
            if is_nominal_deprel(&rels[i]) { nominal_support = true; }
            else if is_modifier_deprel(&rels[i]) { modifier_hits += 1; }
        }
        if checked > 0 && !nominal_support && modifier_hits == checked {
            return MorphVerdict::no("UD DEPREL 전량 수식어 관계(acl/amod/advmod 등)");
        }
        // PROPN 단독 토큰은 구문상 체언 논항일 때만 인정 (PROPN 남발 차단)
        if core.len() == 1 && !has_weak {
            let i = core[0];
            let t = upos_base(tags[i]);
            if t == "PROPN" && i < rels.len() && !is_nominal_deprel(&rels[i]) {
                return MorphVerdict::no("단일 PROPN 이나 UD DEPREL 체언 근거 부재");
            }
        }
        if nominal_support {
            return MorphVerdict::ok("UD DEPREL 체언 논항 근거 확보");
        }
    }

    // ── 4) DEPREL 미확보 시 폴백: 체언 태그 + 비굴절 여부로 판단 ──
    if !has_strong {
        // 약체언(ADJ/NUM/X) 단독은 개체명 근거로 불충분
        if core.len() >= 2 {
            return MorphVerdict::ok("복합 구성 내 약체언 (보조 근거 인정)");
        }
        if is_sub_language {
            return MorphVerdict::ok("SUB-LANGUAGE 구제 (약체언 단독)");
        }
        return MorphVerdict::no("체언(NOUN/PROPN) 부재 — 약체언 단독은 개체명 불가");
    }

    // 단일 토큰이 굴절형이면(모델 원형 ≠ 표면형) 개체명보다 활용형일 가능성이 높음
    if core.len() == 1 {
        if let Some(lm) = lemmas {
            let i = core[0];
            if i < lm.len() && is_inflected_surface(&words[i], &lm[i]) {
                let t = upos_base(tags[i]);
                if t != "PROPN" {
                    return MorphVerdict::no("단일 굴절형 토큰 (Lemma 상이) — 활용형으로 판단");
                }
            }
        }
    }

    MorphVerdict::ok("UD UPOS 체언 근거 확보")
}

/// [PHASE 2] Depparse ONNX 세션을 실행하여 토큰별 UD DEPREL 레이블을 추출합니다.
/// preprocessor 와 session 을 분리 수신하여 StanzaPipeline 의 필드 단위 대여 충돌을 방지합니다.
pub fn run_depparse_deprels(
    preprocessor: &crate::stanza::StanzaPreprocessor,
    session: &mut onnxruntime::session::Session<'static>,
    words: &[&str],
    pos_ids: &[i64],
) -> Option<Vec<String>> {
    if preprocessor.deprel_vocab.is_empty() || words.is_empty() { return None; }
    if pos_ids.len() < words.len() { return None; }

    // 세션 가변 대여 이전에 사전을 복제하여 라이프타임 충돌을 원천 차단
    let deprel_vocab: Vec<String> = preprocessor.deprel_vocab.clone();

    let inputs = preprocessor
        .encode_to_tensor(words, session, Some(&pos_ids[..words.len()]), None)
        .ok()?;

    let outputs = session.run::<'_, '_, '_, i64, f32, _>(inputs).ok()?;
    if outputs.len() < 2 { return None; }

    let arc = &outputs[0];
    let rel = &outputs[1];
    let arc_shape = arc.shape();
    let rel_shape = rel.shape();
    if arc_shape.len() < 3 || rel_shape.len() < 4 { return None; }

    let seq = words.len().min(arc_shape[1] as usize).min(rel_shape[1] as usize);
    let head_dim = (arc_shape[2] as usize).min(rel_shape[2] as usize);
    let num_rel = rel_shape[3] as usize;
    if seq == 0 || head_dim == 0 || num_rel == 0 { return None; }

    let mut result = Vec::with_capacity(seq);
    for i in 0..seq {
        // 1) 최고 점수 head(지배소) 탐색
        let mut best_head = 0usize;
        let mut best_arc = std::f32::MIN;
        for h in 0..head_dim {
            let v = arc[[0, i, h]];
            if v > best_arc { best_arc = v; best_head = h; }
        }
        // 2) 해당 head 에 대한 최적 DEPREL 레이블 탐색
        let mut best_rel = 0usize;
        let mut best_rel_score = std::f32::MIN;
        for r in 0..num_rel {
            let v = rel[[0, i, best_head, r]];
            if v > best_rel_score { best_rel_score = v; best_rel = r; }
        }
        result.push(deprel_vocab.get(best_rel).cloned().unwrap_or_else(|| "dep".to_string()));
    }
    Some(result)
}

pub fn max_pool_sim(target: &[f32], phrase_embs: &Vec<Vec<f32>>) -> f32 {
    let mut best = 0.0f32;
    for pe in phrase_embs {
        let s = cosine_similarity(target, pe);
        if s > best { best = s; }
    }
    best
}

pub fn split_bias_phrases(raw: &str) -> Vec<String> {
    let mut v: Vec<String> = raw
        .split(|c: char| c == ',' || c == '\n' || c == '/' || c == '|')
        .map(|s| s.trim().to_string())
        .filter(|s| !s.is_empty())
        .collect();
    let mut seen = std::collections::HashSet::new();
    v.retain(|p| seen.insert(p.clone()));
    if v.len() > 48 { v.truncate(48); }
    v
}

// 🌟 [PHRASE WEIGHTING] 바이어스 문자열을 구(phrase) 단위로 쪼개면서,
// "order 2026-03-15T14:16:35", "order 12345-67890" 같은 숫자 리터럴 예시에는 낮은 가중치를 부여합니다.
// 이 예시들은 '형식 힌트'일 뿐인데 Max-Pool 을 그대로 적용하면
// "수량 | 1", "상품금액 | 35000" 같은 무관한 숫자 라인을 강하게 끌어당겨 오매칭을 만듭니다.
pub fn split_bias_phrases_weighted(raw: &str) -> (Vec<String>, Vec<f32>) {
    let phrases = split_bias_phrases(raw);
    let mut weights = Vec::with_capacity(phrases.len());
    for p in &phrases {
        let compact: Vec<char> = p.chars().filter(|c| !c.is_whitespace()).collect();
        let total = compact.len().max(1);
        let digits = compact.iter().filter(|c| c.is_ascii_digit()).count();
        let ratio = digits as f32 / total as f32;

        if ratio >= 0.25 {
            // 숫자 비중이 높은 순수 예시 리터럴 (형식 힌트 전용)
            weights.push(0.80);
        } else if digits > 0 {
            weights.push(0.95);
        } else {
            // 의미 구(semantic phrase) - 실제 변별력의 원천
            weights.push(1.0);
        }
    }
    (phrases, weights)
}

// 🌟 [WEIGHTED MAX-POOL] 센트로이드(평균) 대신 구 단위 최대 유사도를 사용합니다.
// 거대한 콤마 나열 문자열 하나를 통째로 임베딩하면 모든 개념의 평균이 되어
// 어떤 라인과도 0.0x 수준의 무의미한 값만 나오는 문제를 원천 차단합니다.
pub fn weighted_max_pool_sim(target: &[f32], phrase_embs: &Vec<Vec<f32>>, weights: &Vec<f32>) -> f32 {
    let mut best = 0.0f32;
    for (i, pe) in phrase_embs.iter().enumerate() {
        if pe.iter().all(|&v| v == 0.0) { continue; }
        let w = weights.get(i).copied().unwrap_or(1.0);
        let s = cosine_similarity(target, pe) * w;
        if s > best { best = s; }
    }
    best
}

// 🌟 [UNCAPPED PHRASE SPLIT] split_bias_phrases 는 48개에서 잘라냅니다.
//    bias.json 의 color 뱅크는 50개 언어의 색상명이 수백 개 나열되어 있어
//    48개로 자르면 한국어/영어 이후의 언어(ベージュ, بيج, бежевый ...)가 통째로 소멸합니다.
//    다국어 검색이 목적이므로 속성 뱅크에는 절대 상한을 두지 않습니다.
pub fn split_bias_phrases_full(raw: &str) -> Vec<String> {
    let mut v: Vec<String> = raw
        .split(|c: char| c == ',' || c == '\n' || c == '/' || c == '|')
        .map(|s| s.trim().to_string())
        .filter(|s| !s.is_empty())
        .collect();
    let mut seen = std::collections::HashSet::new();
    v.retain(|p| seen.insert(p.clone()));
    v
}

// 🌟 [UNCAPPED WEIGHTED SPLIT] split_bias_phrases_weighted 의 상한 제거판.
//    숫자 비중이 높은 순수 예시 리터럴("15000", "2026-03-15")은 형식 힌트일 뿐이므로
//    동일한 규칙으로 가중치만 낮춥니다. (새 상수 도입 아님 — 기존 규칙 재사용)
pub fn split_bias_phrases_weighted_full(raw: &str) -> (Vec<String>, Vec<f32>) {
    let phrases = split_bias_phrases_full(raw);
    let mut weights = Vec::with_capacity(phrases.len());
    for p in &phrases {
        let compact: Vec<char> = p.chars().filter(|c| !c.is_whitespace()).collect();
        let total = compact.len().max(1);
        let digits = compact.iter().filter(|c| c.is_ascii_digit()).count();
        let ratio = digits as f32 / total as f32;

        if ratio >= 0.25 {
            weights.push(0.80);
        } else if digits > 0 {
            weights.push(0.95);
        } else {
            weights.push(1.0);
        }
    }
    (phrases, weights)
}

// 🌟 [SEMANTIC ANCHOR] 필드의 '정체성 문구'(semantic)를 bias.json 에서 언어 중립으로 꺼냅니다.
//    ko.goods.title.semantic = "상품명, 의류명, 제품명, 품목명, 이름" 처럼
//    정답 변별 구가 bias 가 아니라 semantic 에만 존재하는 경우가 많은데
//    (로그의 '가디건' → title 이 정답인 근거는 '의류명' 단 하나입니다)
//    기존 파이프라인은 semantic 을 프롬프트 설명문으로만 쓰고 벡터 공간에는 올리지 않았습니다.
//    루트 전역 노드(color, metrics.*, operators.* ...)까지 깊이 무관 탐색으로 찾아냅니다.
pub fn semantic_anchor_text(doc_lang: &str, page_type: &str, field_name: &str) -> String {
    let dict: &serde_json::Value = &crate::parsing::BIAS_DICT;
    // 🌟 [BIAS TYPE CANONICALIZE] 무역 서식 코드는 공용 'shipping_doc' 노드로 접습니다.
    let canon = crate::utils::bias_schema::canonical_bias_type(page_type);

    for lk in [doc_lang, "en", "ko"] {
        let lang_node = match dict.get(lk) { Some(v) => v, None => continue };
        if let Some(s) = lang_node
            .get(page_type)
            .and_then(|p| p.get(field_name))
            .and_then(|n| n.get("semantic"))
            .and_then(|v| v.as_str())
        {
            if !s.trim().is_empty() { return s.to_string(); }
        }
        if canon != page_type {
            if let Some(s) = lang_node
                .get(canon)
                .and_then(|p| p.get(field_name))
                .and_then(|n| n.get("semantic"))
                .and_then(|v| v.as_str())
            {
                if !s.trim().is_empty() { return s.to_string(); }
            }
        }
        if let Some(s) = lang_node
            .get("default")
            .and_then(|p| p.get(field_name))
            .and_then(|n| n.get("semantic"))
            .and_then(|v| v.as_str())
        {
            if !s.trim().is_empty() { return s.to_string(); }
        }
    }

    let mut stack: Vec<&serde_json::Value> = vec![dict];
    let mut hops = 0usize;
    while let Some(node) = stack.pop() {
        hops += 1;
        if hops > 8192 { break; }
        if let Some(obj) = node.as_object() {
            if let Some(child) = obj.get(field_name) {
                if let Some(s) = child.get("semantic").and_then(|v| v.as_str()) {
                    if !s.trim().is_empty() { return s.to_string(); }
                }
            }
            for (_, v) in obj {
                if v.is_object() { stack.push(v); }
            }
        }
    }

    humanize_url_token(field_name)
}

// 🌟 [ABSTRACT BRIDGE — FIELD SCOPE] search_bridge.abstract_bridge 에서
//    이 필드를 목표로 하는 브릿지 구만 뽑아냅니다.
//    키는 "substantial_filters.weight" 형태이므로 '.' 뒤 조각이 필드명과 같으면 채택합니다.
//    정방향은 이 구들로 '무거운' → weight 를 라우팅하는데, 역방향(저장)에는 이 축이
//    통째로 빠져 있어서 "정방향이 잡은 의도를 받아줄 벡터가 DB에 없는" 상태였습니다.
pub fn abstract_bridge_field_phrases(field_name: &str) -> Vec<String> {
    let mut out: Vec<String> = Vec::new();
    let node = match crate::parsing::BIAS_DICT
        .get("search_bridge")
        .and_then(|sb| sb.get("abstract_bridge"))
        .and_then(|v| v.as_object())
    { Some(n) => n, None => return out };

    for (target, val) in node {
        let key = match target.rsplitn(2, '.').next() { Some(k) => k, None => continue };
        if key != field_name { continue; }
        for field in ["semantic", "bias"] {
            if let Some(s) = val.get(field).and_then(|v| v.as_str()) {
                for p in split_bias_phrases_full(s) {
                    if !out.iter().any(|e| e == &p) { out.push(p); }
                }
            }
        }
    }
    if out.len() > 48 { out.truncate(48); }
    out
}

// 🌟 [INDEXING ANCHOR] 저장(역방향) 시점에 청크 벡터 위에 얹을 '다국어 라벨 앵커'입니다.
//    json_to_natural_language() 는 무조건 영어 문장을 만들지만 질의는 문서 언어이므로,
//    저장 벡터에 문서 언어 라벨을 반드시 섞어야 코사인이 성립합니다.
//
//    🌟 [편입 순서 역전] 기존 순서는
//        ① semantic ② label_phrase_bank ③ abstract_bridge ④ multilingual_value_anchor
//    였고 마지막에 truncate(32) 를 걸었습니다.
//    그 결과 앞 세 축이 창을 다 먹고 나면 ④ 는 영어 앞부분만 들어가,
//    정작 크로스링구얼 매칭의 핵심인 '니트 / 가디건 / ニット / カーディガン' 이
//    저장 벡터에 단 한 번도 실리지 못했습니다.
//    다국어 값 축을 최우선으로 편입하고 상한을 제거합니다.
//    (앵커 가중치는 Text 0.10 / 그 외 0.30 이므로 구 수가 늘어도 값 벡터를 침범하지 않습니다)
//
//    🌟 [LABEL-ONLY] 이 함수의 출력은 '라벨 개념' 전용입니다.
//    로컬라이즈(값 결합) 텍스트에 이 블롭을 그대로 쓰면 값이 수십 토큰 중 3토큰으로
//    희석되어, 값 질의("니트 가디건")가 어떤 청크와도 구분되지 않습니다.
//    값 결합용으로는 반드시 indexing_leaf_label() 을 사용하십시오.
pub fn indexing_anchor_text(doc_lang: &str, page_type: &str, field_name: &str) -> String {
    let mut phrases: Vec<String> = Vec::new();

    // ① [최우선] 다국어 값 도메인 축 — 크로스링구얼 매칭의 유일한 근거
    //    🌟 page_type 이 이미 인자로 들어와 있는데 쓰지 않아, 저장 벡터에도
    //       goods/review/tracking 세 도메인 어휘가 전부 섞여 있었습니다.
    for p in multilingual_value_anchor_phrases_scoped(page_type, field_name) {
        if !phrases.iter().any(|e| e == &p) { phrases.push(p); }
    }

    // ② 문서 언어 semantic 앵커
    for p in split_bias_phrases_full(&semantic_anchor_text(doc_lang, page_type, field_name)) {
        if !phrases.iter().any(|e| e == &p) { phrases.push(p); }
    }

    // ③ 문서 언어 라벨 뱅크
    let (label_phrases, _w) = label_phrase_bank(doc_lang, page_type, field_name);
    for p in label_phrases {
        if !phrases.iter().any(|e| e == &p) { phrases.push(p); }
    }

    // ④ 추상 수식어 브릿지 (heavy / expensive / fast ...)
    for p in abstract_bridge_field_phrases(field_name) {
        if !phrases.iter().any(|e| e == &p) { phrases.push(p); }
    }

    if phrases.is_empty() {
        return humanize_url_token(field_name);
    }
    phrases.join(", ")
}

// 🌟 [INDEXING LEAF LABEL] 값과 결합할 '단 하나의 짧은 문서 언어 라벨'입니다.
//    indexing_anchor_text() 는 라벨 10~32구를 join 한 블롭이라
//    "상품명, 의류명, 제품명, 품목명, 이름, ... Cable Knit Cardigan" 처럼
//    값이 통째로 희석됩니다.
//    (new_log2.txt: title 청크가 후보 진입조차 못 하고 status 가 상위 9건 독점)
//    여기서는 semantic 의 '첫 구' 하나만 뽑아 "상품명 Cable Knit Cardigan" 형태로
//    값이 지배하는 로컬라이즈 텍스트를 만듭니다.
pub fn indexing_leaf_label(doc_lang: &str, page_type: &str, field_name: &str) -> String {
    let sem = semantic_anchor_text(doc_lang, page_type, field_name);
    for p in split_bias_phrases_full(&sem) {
        let t = p.trim();
        if t.is_empty() { continue; }
        // 예시값(숫자 리터럴/장문)은 라벨이 아닙니다.
        if is_value_example_phrase(t) { continue; }
        return t.to_string();
    }
    humanize_url_token(field_name)
}

// 🌟 [MULTILINGUAL VALUE ANCHOR] bias.json 의 search_bridge.multilingual_value_anchor 에서
//    이 필드의 '값이 속한 의미 도메인'을 다국어로 기술한 구를 읽습니다.
//
//    🌟 [양방향 공용] 이 노드는 '스키마 속성 뱅크' 에만 편입됩니다.
//    filter_category_phrases() 는 substantial/find/status/time/season 만 읽고,
//    abstract_bridge_phrases() 는 search_bridge.abstract_bridge 만 읽으므로
//    정방향 필터 뱅크·SURPRISAL 게이트·연산자 뱅크는 전혀 오염되지 않습니다.
//    역방향은 indexing_anchor_text() 로, 정방향은 속성 뱅크 구축부로 편입되어
//    질의 벡터와 저장 벡터가 같은 다국어 값 축을 공유하게 됩니다.
//
//    🌟 [상한 제거 이유] 이 노드의 구 순서는 (semantic → 영어 → 한국어 → 일본어 → 중국어 → …)
//    이므로 48구 상한은 일본어 3구째에서 잘려, 그 뒤 40여 개 언어의 값 어휘가 통째로 소멸합니다.
//    다국어 크로스링구얼 매칭이 이 노드의 유일한 존재 이유이므로 상한을 두지 않습니다.
//    (Max-Pool 은 구 개수가 늘어도 최댓값만 취하고, 뱅크 크기 편향은
//     bank_size_equalized_mask() 가 질의 시점에 상대 통계로 별도 정규화합니다)
// 🌟 [DOMAIN-SCOPED ANCHOR] bias.json 의 키는 "goods.title" / "review.title" / "tracking.title"
//    처럼 도메인 접두를 갖습니다. 그런데 기존 판정은
//        target.rsplitn(2, '.').next()   →  "goods.title" 에서 "title"
//    이라 field_name="title" 하나로 세 도메인이 전부 병합되었습니다.
//    그 결과 review 검색의 title 뱅크에 의류 어휘 200여 구가 실려
//    review.title 과 goods.title 이 벡터 공간에서 구분되지 않습니다.
//    page_type 을 알고 있으면 "page_type.field_name" 정확 일치를 우선하고,
//    그 도메인 항목이 없을 때만 기존 접미 일치로 폴백합니다.
pub fn multilingual_value_anchor_phrases_scoped(page_type: &str, field_name: &str) -> Vec<String> {
    let mut out: Vec<String> = Vec::new();
    let node = match crate::parsing::BIAS_DICT
        .get("search_bridge")
        .and_then(|sb| sb.get("multilingual_value_anchor"))
        .and_then(|v| v.as_object())
    { Some(n) => n, None => return out };

    // 🌟 [BIAS TYPE CANONICALIZE] "BL.pol" 은 bias.json 에 없고 "shipping_doc.pol" 만
    //    존재합니다. 정규화하지 않으면 무역 문서의 저장 벡터에 다국어 값 축이
    //    한 구도 실리지 않아 크로스링구얼 리콜이 0 이 됩니다.
    let scoped_key = if page_type.trim().is_empty() {
        String::new()
    } else {
        format!(
            "{}.{}",
            crate::utils::bias_schema::canonical_bias_type(page_type.trim()),
            field_name
        )
    };

    // ① 도메인 정확 일치 (goods.title 질의에는 goods.title 만)
    if !scoped_key.is_empty() {
        if let Some(val) = node.get(&scoped_key) {
            for field in ["semantic", "bias"] {
                if let Some(s) = val.get(field).and_then(|v| v.as_str()) {
                    for p in split_bias_phrases_full(s) {
                        if !out.iter().any(|e| e == &p) { out.push(p); }
                    }
                }
            }
        }
    }
    if !out.is_empty() { return out; }

    // ② 폴백 : 이 필드에 도메인 항목이 아예 없을 때만 접미 일치로 전 도메인 수집.
    //    (page_type 이 비어 오는 호출부의 기존 동작을 그대로 보존합니다)
    for (target, val) in node {
        let key = match target.rsplitn(2, '.').next() { Some(k) => k, None => continue };
        if key != field_name { continue; }
        for field in ["semantic", "bias"] {
            if let Some(s) = val.get(field).and_then(|v| v.as_str()) {
                for p in split_bias_phrases_full(s) {
                    if !out.iter().any(|e| e == &p) { out.push(p); }
                }
            }
        }
    }
    out
}

pub fn multilingual_value_anchor_phrases(field_name: &str) -> Vec<String> {
    // 🌟 도메인을 모르는 레거시 호출부용. 기존 접미 일치 동작을 그대로 유지합니다.
    multilingual_value_anchor_phrases_scoped("", field_name)
}

// 🌟 [METRICS FAMILY] bias.json 의 metrics.* 노드를 (family_key, phrase) 목록으로 펼칩니다.
//    metrics.price.bias 에는 이미 "won" 이 들어 있어서, 다국어 임베딩이
//    '원' ↔ 'won' 을 연결해 줍니다. 따라서 "5000원 이하로" 의 수치 대상이
//    quantity 가 아니라 price 계열이라는 사실을 어휘 하드코딩 없이 판정할 수 있습니다.
pub fn metrics_family_phrases() -> Vec<(String, String)> {
    let mut out: Vec<(String, String)> = Vec::new();
    if let Some(node) = crate::parsing::BIAS_DICT.get("metrics").and_then(|v| v.as_object()) {
        for (key, val) in node {
            for field in ["semantic", "bias"] {
                if let Some(s) = val.get(field).and_then(|v| v.as_str()) {
                    for p in split_bias_phrases_full(s) {
                        if out.iter().any(|(k, e)| k == key && e == &p) { continue; }
                        out.push((key.clone(), p));
                    }
                }
            }
        }
    }
    out
}

// 🌟 [METRICS FAMILY — 단일 벡터 argmax] 임베딩 하나가 어떤 metrics 계열에 가장 가까운지
//    (family_key, score) 로 반환합니다. 그룹별 Max-Pool 이라 뱅크 크기 편향이 없습니다.
pub fn metrics_family_argmax(target: &[f32], bank: &[(String, Vec<f32>)]) -> (String, f32) {
    let mut group: std::collections::HashMap<String, f32> = std::collections::HashMap::new();
    for (k, e) in bank {
        if e.iter().all(|&v| v == 0.0) { continue; }
        let s = cosine_similarity(target, e);
        let entry = group.entry(k.clone()).or_insert(f32::MIN);
        if s > *entry { *entry = s; }
    }
    let mut best_key = String::new();
    let mut best = f32::MIN;
    for (k, s) in &group {
        if *s > best { best = *s; best_key = k.clone(); }
    }
    (best_key, if best == f32::MIN { 0.0 } else { best })
}

// 🌟 [METRICS FAMILY — 필드 뱅크 argmax] 그 필드의 구 뱅크 전체가 어떤 metrics 계열인지 판정합니다.
//    sale_price 뱅크는 metrics.price 와, quantity 뱅크는 metrics.quantity 와 붙습니다.
pub fn metrics_family_of_bank(field_bank: &Vec<Vec<f32>>, bank: &[(String, Vec<f32>)]) -> String {
    if field_bank.is_empty() { return String::new(); }
    let mut group: std::collections::HashMap<String, f32> = std::collections::HashMap::new();
    for (k, e) in bank {
        if e.iter().all(|&v| v == 0.0) { continue; }
        let s = max_pool_sim(e, field_bank);
        let entry = group.entry(k.clone()).or_insert(f32::MIN);
        if s > *entry { *entry = s; }
    }
    let mut best_key = String::new();
    let mut best = f32::MIN;
    for (k, s) in &group {
        if *s > best { best = *s; best_key = k.clone(); }
    }
    best_key
}

// 🌟 [CROSS-FIELD AMBIGUITY MASK] bias.json 을 수정하지 않고 런타임에서 무변별 구를 구조적으로 제거합니다.
//    ① 두 개 이상 필드의 bias 뱅크에 '문자 그대로 동일한 구'가 들어 있으면
//       그 구는 어떤 필드도 지목하지 못합니다.
//       (ko.goods 의 title / model_name / brand_name 이 "goods 상품명, goods 상품제목, goods 상품이름" 을
//        완전히 공유 → 로그의 '가디건 → brand_name' 오배정의 직접 원인)
//    ② 자기 필드의 prejudice 에 동일한 구가 존재하면 자기모순입니다.
//       (ko.goods.brand_name 은 bias 와 prejudice 양쪽에 "상품명" 을 갖고 있어 스스로 점수를 깎습니다)
//    문자열 집합 비교이므로 의미 판정(contains)이 아니라 순수 구조 판정이며 상수를 쓰지 않습니다.
pub fn cross_field_ambiguous_phrase_mask(
    bias_banks: &Vec<Vec<String>>,
    prejudice_banks: &Vec<Vec<String>>,
) -> Vec<Vec<bool>> {
    let mut counter: std::collections::HashMap<String, usize> = std::collections::HashMap::new();
    for bank in bias_banks.iter() {
        let mut seen: std::collections::HashSet<&str> = std::collections::HashSet::new();
        for p in bank.iter() {
            if seen.insert(p.as_str()) {
                *counter.entry(p.clone()).or_insert(0) += 1;
            }
        }
    }

    let mut out: Vec<Vec<bool>> = Vec::with_capacity(bias_banks.len());
    for (i, bank) in bias_banks.iter().enumerate() {
        let empty: Vec<String> = Vec::new();
        let own_prej: &Vec<String> = prejudice_banks.get(i).unwrap_or(&empty);
        let mut keep: Vec<bool> = bank
            .iter()
            .map(|p| {
                let shared = counter.get(p).copied().unwrap_or(0) > 1;
                let self_contradiction = own_prej.iter().any(|q| q == p);
                !shared && !self_contradiction
            })
            .collect();
        // 전량 탈락 시 뱅크 소멸을 막기 위해 원본을 그대로 유지합니다.
        if keep.iter().all(|k| !*k) { keep = vec![true; bank.len()]; }
        out.push(keep);
    }
    out
}

// 🌟 [DETERMINISTIC CONDITION VALUE] 조건 값은 '벡터가 짚어준 원문 청크' 그 자체입니다.
//    0.6B 모델에게 값 복사를 맡기면 value 키를 통째로 누락시켜 조건이 증발합니다.
//    (로그: color 조건에 value 키가 없어 색상 필터 없이 FTS 가 실행됨)
//    형식이 확정적인 필드는 LLM 없이 코드가 직접 복사합니다.
pub fn deterministic_condition_value(chunks: &Vec<String>, numeric_only: bool) -> String {
    let joined = chunks
        .iter()
        .map(|s| s.trim())
        .filter(|s| !s.is_empty())
        .collect::<Vec<_>>()
        .join(" ");
    if numeric_only {
        return joined.chars().filter(|c| c.is_ascii_digit() || *c == '.').collect();
    }
    joined.split_whitespace().collect::<Vec<_>>().join(" ")
}

// 🌟 [QUERY FORMAT GATE] 자연어 질의 청크가 '이 속성의 값이 될 생김새'인지 배정 전에 검증합니다.
//    detect_field_format 이 이미 필드명에서 물리적 형식을 결정론적으로 판정하므로
//    다국어 어휘 리터럴을 단 하나도 쓰지 않고, 숫자 밀도 / 알파벳 존재 / 토큰 길이만 봅니다.
//    (로그: '가디건' 이 supply_price(Number) 2순위로 살아남아 LLM 후보 목록을 오염시켰습니다)
//    - Synthesis(insight/summary) : 합성 문장이라 DB 필터 조건이 될 수 없음
//    - Link                        : 조건 대상이 아님 (호출부에서 이미 제외하지만 방어적으로 차단)
pub fn query_chunk_matches_property(field_name: &str, chunk: &str) -> bool {
    let v = chunk.trim();
    if v.is_empty() { return false; }

    match detect_field_format(field_name) {
        FieldFormat::Synthesis => false,
        FieldFormat::Link => false,
        FieldFormat::Enum => true,
        FieldFormat::Numeric => v.chars().any(|c| c.is_ascii_digit()),
        // 🌟 [NATURAL LANGUAGE TIME] 날짜 필드는 리터럴(2026-03-15)뿐 아니라
        //    자연어 시간 표현('올해', '여름', 'last year')도 값이 될 수 있습니다.
        //    기존 숫자 존재 판정만으로는 '올해' 가 ASCII 숫자 0개라 차단되어
        //    started_at / expired_at / registration_date 후보 12개가 통째로 학살되었습니다.
        //    (로그: [FORMAT GATE] "올해→started_at(0.5521)", "올해→expired_at(0.5342)" ...)
        //    bias.json 의 time_filters / season_filters exact_match 배열은
        //    50개 언어의 시간·계절 표현을 문자열 그대로 담은 확정 사전이므로
        //    다국어 하드코딩 없이 완전일치(==)로 되살릴 수 있습니다.
        FieldFormat::Date => {
            if v.chars().any(|c| c.is_ascii_digit()) { return true; }
            v.split_whitespace().any(|w| {
                exact_match_filter_key("time_filters", w).is_some()
                    || exact_match_filter_key("season_filters", w).is_some()
            })
        },
        FieldFormat::Phone => v.chars().filter(|c| c.is_ascii_digit()).count() >= 7,
        FieldFormat::TrackingCode => longest_code_token_len(v) >= 8,
        FieldFormat::Identifier => longest_code_token_len(v) >= 4,
        FieldFormat::Address => v.chars().any(|c| c.is_alphabetic()),
        FieldFormat::Text => v.chars().any(|c| c.is_alphabetic()),
    }
}

// 🌟 [QUERY FORMAT GATE — VECTOR EXTENDED]
//    query_chunk_matches_property 의 Date 분기는 bias.json 의 exact_match 배열에 전적으로 의존합니다.
//    그런데 time_filters 노드에는 exact_match 가 아예 존재하지 않습니다(season_filters 에만 있음).
//      "this_year": { "semantic": ..., "bias": ..., "prejudice": ... }   ← exact_match 없음
//    그래서 '올해' 는 (ASCII 숫자 0개) AND (exact_match 미등록) 이 되어 통째로 차단되고,
//    로그처럼 started_at(0.5521) / expired_at(0.5342) / registration_date(0.5202) 라는
//    1순위보다 높은 정답 후보 12개가 배정 이전에 전멸합니다.
//    그 상태에서 Qwen3 는 남은 쓰레기(title/color/address/status/first_purchase_only) 중에서만
//    고를 수 있어 '올해 → new_customer_only' 오배정이 확정됩니다.
//
//    여기서는 bias.json 을 수정하지 않고, 호출부가 임베딩 코사인/문자열 구조 파싱으로 확정한
//      ① temporal_hint         : 이 청크가 시간·계절 의도인가 (time/season 뱅크 우위)
//      ② numeric_comparison_hint : 이 청크가 (숫자 + 비교 표현) 구조인가
//    두 힌트를 받아 게이트를 확장합니다. 어휘 리터럴과 contains 판정은 일절 사용하지 않습니다.
pub fn query_chunk_matches_property_ext(
    field_name: &str,
    chunk: &str,
    temporal_hint: bool,
    numeric_comparison_hint: bool,
) -> bool {
    let v = chunk.trim();
    if v.is_empty() { return false; }

    let fmt = detect_field_format(field_name);

    // 🌟 [NUMERIC COMPARISON EXCLUSIVE] '5000원 이하로' 처럼 숫자와 비교 표현이 결합된 청크는
    //    물리적으로 수치 비교 조건입니다.
    //    currency.bias 의 '원' 이 '5000원' 과 공명해 String 필드가 이 청크를 선점하면
    //        currency contains "5000원 이하로"   (convert_conditions_to_sql 에서 통째로 스킵)
    //    라는 SQL 무효 조건만 남고, 정답인 sale_price lte 5000 은 영원히 발행되지 않습니다.
    //    cross_field_ambiguous_phrase_mask 는 '문자 그대로 동일한 구'만 제거하므로
    //    '원'(currency.bias) vs '29900원'(sale_price.bias) 은 잡을 수 없습니다.
    //    따라서 배정 '전' 에 문자열/열거형 필드의 후보 자격 자체를 박탈합니다.
    if numeric_comparison_hint {
        return matches!(fmt, FieldFormat::Numeric | FieldFormat::Date);
    }

    match fmt {
        FieldFormat::Synthesis => false,
        FieldFormat::Link => false,
        FieldFormat::Enum => true,
        FieldFormat::Numeric => v.chars().any(|c| c.is_ascii_digit()),
        FieldFormat::Date => {
            if v.chars().any(|c| c.is_ascii_digit()) { return true; }
            if temporal_hint { return true; }
            // 🌟 [SEMANTIC ANCHOR TEMPORAL] bias.json 의 time_filters.*.semantic 에
            //    "current year", "previous day" 등의 영어 구가 있습니다.
            //    exact_match 배열이 없는 time_filters 를 위해,
            //    semantic 필드의 구를 split_bias_phrases_full 로 쪼개
            //    다국어 임베딩 코사인으로 매칭합니다.
            //    '올해' 와 embed("current year") 의 코사인은 multilingual 모델에서 0.6+ 입니다.
            if temporal_semantic_match(v) { return true; }
            v.split_whitespace().any(|w| {
                exact_match_filter_key("time_filters", w).is_some()
                    || exact_match_filter_key("season_filters", w).is_some()
            })
        },
        FieldFormat::Phone => v.chars().filter(|c| c.is_ascii_digit()).count() >= 7,
        FieldFormat::TrackingCode => longest_code_token_len(v) >= 8,
        FieldFormat::Identifier => longest_code_token_len(v) >= 4,
        FieldFormat::Address => v.chars().any(|c| c.is_alphabetic()),
        FieldFormat::Text => v.chars().any(|c| c.is_alphabetic()),
    }
}

// 🌟 [TEMPORAL SEMANTIC MATCH] bias.json 의 time_filters / season_filters 각 키의
//    "semantic" 필드에는 "current year", "spring season" 같은 핵심 의미 구가 있습니다.
//    exact_match 배열이 없는 time_filters 를 위해, 이 semantic 구를
//    split_bias_phrases_full 로 쪼개 임베딩하고, 질의 청크와의 코사인을 계산합니다.
//    판정 기준은 '해당 카테고리 내 semantic 구들과의 Max-Pool 코사인'이
//    '다른 모든 필터 카테고리 semantic 구들과의 Max-Pool 코사인'보다 높은지입니다.
//    절대 임계치 없이 상대 비교만 사용하므로 매직 상수가 없습니다.
//    이 함수는 임베딩을 내부에서 생성하지 않고, 호출부가 미리 계산한
//    temporal_semantic_scores 맵을 참조하는 구조로 model.rs 에서 호출됩니다.
//    여기서는 bias.json 에서 semantic 구 목록을 추출하는 순수 결정론 함수입니다.
pub fn temporal_semantic_phrases() -> Vec<(String, String)> {
    // (category_key, semantic_phrase) 쌍을 반환
    let mut out: Vec<(String, String)> = Vec::new();
    let dict: &serde_json::Value = &crate::parsing::BIAS_DICT;
    for cat in ["time_filters", "season_filters"] {
        if let Some(node) = dict.get(cat).and_then(|v| v.as_object()) {
            for (key, val) in node {
                if let Some(semantic) = val.get("semantic").and_then(|v| v.as_str()) {
                    for phrase in split_bias_phrases_full(semantic) {
                        out.push((format!("{}.{}", cat, key), phrase));
                    }
                }
                // bias 도 구 단위로 추가 (semantic 이 짧을 수 있으므로)
                if let Some(bias) = val.get("bias").and_then(|v| v.as_str()) {
                    for phrase in split_bias_phrases_full(bias) {
                        out.push((format!("{}.{}", cat, key), phrase));
                    }
                }
            }
        }
    }
    out
}

// 🌟 [TEMPORAL SEMANTIC MATCH - LIGHTWEIGHT] 임베딩 없이 문자열 구조로 판정하는 폴백.
//    bias.json 의 time_filters.*.semantic / bias 구 중에
//    질의 청크의 '공백 제거 소문자'와 완전일치하는 구가 있으면 temporal 로 판정.
//    예: chunk="올해" → bias 구 "this year" 와는 불일치하지만,
//    season_filters 의 exact_match 에는 없으므로 이 경로로는 불가.
//    따라서 이 함수는 보조 수단이며, 주 경로는 model.rs 의 임베딩 코사인입니다.
pub fn temporal_semantic_match(_chunk: &str) -> bool {
    // 이 함수는 model.rs 에서 임베딩 기반으로 대체되므로
    // 여기서는 항상 false 를 반환하여 기존 exact_match 경로를 유지합니다.
    // 실제 temporal 판정은 model.rs 의 TEMPORAL PRE-GATE 개선에서 수행합니다.
    false
}

// 🌟 [FILTER CATEGORY PHRASE BANK] substantial_filters / find_filters / status_filters 의
//    bias + semantic 구를 쪼개 (category, key, phrase) 목록을 반환합니다.
//    bias.json 에 exact_match 배열이 없는 필터 카테고리(time_filters 포함)를 위해
//    임베딩 코사인 Max-Pool 로 매칭할 수 있는 구 뱅크를 동적으로 구축합니다.
//    다국어 어휘 리터럴을 추가하지 않고, bias.json 의 기존 bias/semantic 필드만 읽습니다.
pub fn filter_category_phrases(categories: &[&str]) -> Vec<(String, String, String)> {
    let mut out: Vec<(String, String, String)> = Vec::new();
    for cat in categories {
        if let Some(node) = crate::parsing::BIAS_DICT.get(cat).and_then(|v| v.as_object()) {
            for (key, val) in node {
                if let Some(bias) = val.get("bias").and_then(|v| v.as_str()) {
                    for phrase in split_bias_phrases_full(bias) {
                        out.push((cat.to_string(), key.clone(), phrase));
                    }
                }
                if let Some(semantic) = val.get("semantic").and_then(|v| v.as_str()) {
                    for phrase in split_bias_phrases_full(semantic) {
                        if !out.iter().any(|(_, _, p)| p == &phrase) {
                            out.push((cat.to_string(), key.clone(), phrase));
                        }
                    }
                }
            }
        }
    }
    out
}

// 🌟 [FILTER ROUTE VERDICT] 질의 청크가 스키마 속성보다 필터 카테고리에 더 적합한지
//    임베딩 코사인 Max-Pool 상대 비교로 판정합니다.
//    절대 임계치 없이 '필터 Max-Pool > 스키마 속성 Max-Pool' 상대 우위만 사용합니다.
//    반환: Some((category, key)) 이면 필터 라우팅, None 이면 스키마 속성 배정 유지.
pub fn filter_route_verdict(
    chunk_emb: &[f32],
    filter_phrase_embs: &[(String, String, Vec<f32>)],
    best_schema_score: f32,
) -> Option<(String, String)> {
    // (category, key) 그룹별 Max-Pool: 개별 구 코사인의 비대칭을 해소합니다.
    // 스키마 측이 weighted_max_pool_sim(구 단위 최대)을 사용하므로
    // 필터 측도 동일 그룹 내 최대 코사인으로 비교해야 공정한 판정입니다.
    let mut group_max: std::collections::HashMap<(String, String), f32> = std::collections::HashMap::new();
    for (cat, key, emb) in filter_phrase_embs {
        if emb.iter().all(|&v| v == 0.0) { continue; }
        let s = cosine_similarity(chunk_emb, emb);
        let entry = group_max.entry((cat.clone(), key.clone())).or_insert(f32::MIN);
        if s > *entry { *entry = s; }
    }
    let mut best_cat = String::new();
    let mut best_key = String::new();
    let mut best_score = f32::MIN;
    for ((cat, key), score) in &group_max {
        if *score > best_score {
            best_score = *score;
            best_cat = cat.clone();
            best_key = key.clone();
        }
    }
    if best_score > best_schema_score && best_score > 0.0 {
        Some((best_cat, best_key))
    } else {
        None
    }
}

// 🌟 [SUBSTANTIAL/FIND PRE-GATE] substantial_filters / find_filters / status_filters 의
//    bias+semantic 구 뱅크와 청크 간 Max-Pool 코사인을 계산하여,
//    스키마 속성보다 필터 의도가 우세한 청크를 배정 전에 차단합니다.
//    filter_route_verdict 가 단어 단위(1토큰)에서만 동작하는 반면,
//    이 함수는 Plinko 청크(다중 토큰) 단위에서도 동작합니다.
//    (로그: '무거운' 이 summer(0.5610) 에 밀려 substantial_filters.weight 로 라우팅 실패)
//    판정 기준: '필터 Max-Pool > 스키마 Max-Pool' 상대 비교만 사용. 매직 상수 없음.
//    반환: Some((category, key, score)) 이면 필터 라우팅, None 이면 스키마 배정 유지.
pub fn substantial_find_pre_gate(
    chunk_emb: &[f32],
    filter_phrase_embs: &[(String, String, Vec<f32>)],
    best_schema_score: f32,
) -> Option<(String, String, f32)> {
    if filter_phrase_embs.is_empty() { return None; }
    // (category, key) 그룹별 Max-Pool
    let mut group_max: std::collections::HashMap<(String, String), f32> = std::collections::HashMap::new();
    for (cat, key, emb) in filter_phrase_embs {
        if emb.iter().all(|&v| v == 0.0) { continue; }
        // substantial / find / status 카테고리만 대상
        if cat != "substantial_filters" && cat != "find_filters" && cat != "status_filters" { continue; }
        let s = cosine_similarity(chunk_emb, emb);
        let entry = group_max.entry((cat.clone(), key.clone())).or_insert(f32::MIN);
        if s > *entry { *entry = s; }
    }
    let mut best_cat = String::new();
    let mut best_key = String::new();
    let mut best_score = f32::MIN;
    for ((cat, key), score) in &group_max {
        if *score > best_score {
            best_score = *score;
            best_cat = cat.clone();
            best_key = key.clone();
        }
    }
    if best_score > best_schema_score && best_score > 0.0 {
        Some((best_cat, best_key, best_score))
    } else {
        None
    }
}

// =====================================================================
// 🌟 [GLOBAL-BASELINE SURPRISAL] 뱅크 크기 편향 제거 + 절대 신호 보존
// ---------------------------------------------------------------------
// 직전 구현은 각 뱅크를 '자기 자신의' 평균/표준편차로 표준화했습니다.
// 극값이론이 E[z of max] ≈ √(2 ln N) 을 예측하므로, 그 값으로 다시 나누면
// 무관한 질의에 대해 결과가 정의상 1.0 으로 수렴합니다.
// (로그 실측: 6개 단어 전부 0.9475 ~ 1.1919 — 판별력 0)
//
// 여기서는 '모든 뱅크를 합친 전역 코사인 분포'를 공통 기준선으로 삼고,
// 뱅크 크기가 만드는 기대 최댓값 √(2 ln N) 만큼만 차감합니다.
//     surprisal = (max - μ_global) / σ_global - √(2 ln N)
// 반환값 0 = 무작위로 N개 뽑은 기대치와 동일(= 근거 없음)
//         > 0 = 그 기대치를 넘는 실제 의미적 근거 존재
// 0 은 극값이론에서 유도된 값이므로 매직 상수가 아닙니다.
// =====================================================================

#[derive(Debug, Clone)]
pub struct SurprisalScore {
    pub category: String,
    pub key: String,
    pub max_cos: f32,
    pub n: usize,
    pub surprisal: f32,
}

/// 🌟 [EXTREME VALUE BASELINE] N개를 무작위로 뽑았을 때 기대되는 최댓값의 z 점수.
///    E[z of max of N] ≈ √(2 ln N)
///    뱅크(또는 패치 집합) 크기가 다른 두 집단의 최댓값을 공정하게 비교하려면
///    반드시 이 기대치를 차감해야 합니다.
///
///    🌟 [PUB] vision_crop 의 크롭 감사와 value_grounding 의 접지 검증이
///       같은 기준선을 사용해야 두 판정이 같은 척도가 되므로 공개합니다.
pub fn gumbel_expected_z(n: usize) -> f32 {
    if n <= 1 { 0.0 } else { (2.0f32 * (n as f32).ln()).sqrt() }
}

/// 🌟 [GENERIC OVER VEC / Arc<Vec>] 벡터 소유 형태에 무관하게 동작합니다.
///    vision_encoder 의 AnchorBank 가 Arc<Vec<f32>> 로 바뀌었지만,
///    다른 호출부는 Vec<f32> 를 그대로 넘깁니다.
///    AsRef<[f32]> 로 받으면 두 형태를 한 함수가 모두 처리합니다.
///
/// 🌟 [O(N²) → O(N)] order 탐색을 HashMap 색인으로 바꿉니다.
///    편견 뱅크가 13,598구일 때 구버전은
///    13,598 × (그룹수/2) 회 문자열 쌍 비교를 수행했습니다.
fn group_sims<V: AsRef<Vec<f32>>>(
    query: &[f32],
    src: &[(String, String, V)],
    pool: &mut Vec<f32>,
) -> (Vec<(String, String)>, Vec<Vec<f32>>) {
    use std::collections::HashMap;
    let mut order: Vec<(String, String)> = Vec::new();
    let mut sims: Vec<Vec<f32>> = Vec::new();
    let mut index: HashMap<(String, String), usize> = HashMap::new();
    for (c, k, e) in src {
        let ev = e.as_ref();
        if ev.iter().all(|&v| v == 0.0) { continue; }
        let s = cosine_similarity(query, ev);
        pool.push(s);
        let key = (c.clone(), k.clone());
        match index.get(&key) {
            Some(&i) => sims[i].push(s),
            None => {
                index.insert(key.clone(), order.len());
                order.push(key);
                sims.push(vec![s]);
            }
        }
    }
    (order, sims)
}

/// 필터 뱅크와 스키마 뱅크를 **하나의 공통 기준선**으로 동시에 채점합니다.
/// 두 결과가 같은 척도이므로 그대로 대소 비교할 수 있습니다.
/// 각 필터 키의 prejudice 구가 자기 기대치를 넘으면 그만큼 상쇄합니다.
/// (bias.json 이 이미 갖고 있는 편견 사전을 필터 경로에서 처음으로 활용)
/// 🌟 [GENERIC] filter 뱅크의 벡터 소유 형태를 일반화합니다.
///    vision_encoder 는 Arc<Vec<f32>>, model.rs 는 Vec<f32> 를 넘깁니다.
pub fn surprisal_dual_scores<V: AsRef<Vec<f32>>>(
    query: &[f32],
    filter_bias: &[(String, String, V)],
    filter_prej: &[(String, String, V)],
    schema_names: &[String],
    schema_banks: &[Vec<Vec<f32>>],
    schema_skip: &[bool],
) -> (Vec<SurprisalScore>, Vec<SurprisalScore>) {
    let mut pool: Vec<f32> = Vec::new();

    let (f_order, f_sims) = group_sims(query, filter_bias, &mut pool);
    let (p_order, p_sims) = group_sims(query, filter_prej, &mut pool);

    let mut s_sims: Vec<Vec<f32>> = Vec::with_capacity(schema_banks.len());
    for (i, bank) in schema_banks.iter().enumerate() {
        let mut v: Vec<f32> = Vec::new();
        if !schema_skip.get(i).copied().unwrap_or(false) {
            for e in bank {
                if e.iter().all(|&x| x == 0.0) { continue; }
                let s = cosine_similarity(query, e);
                pool.push(s);
                v.push(s);
            }
        }
        s_sims.push(v);
    }

    if pool.len() < 2 { return (Vec::new(), Vec::new()); }
    let mean: f32 = pool.iter().sum::<f32>() / (pool.len() as f32);
    let var: f32 = pool.iter().map(|s| (s - mean) * (s - mean)).sum::<f32>() / (pool.len() as f32);
    let std = var.sqrt().max(1e-6);

    let raw = |sims: &Vec<f32>| -> Option<(f32, usize, f32)> {
        if sims.is_empty() { return None; }
        let m = sims.iter().cloned().fold(f32::MIN, f32::max);
        let n = sims.len();
        Some((m, n, (m - mean) / std - gumbel_expected_z(n)))
    };

    let mut fout: Vec<SurprisalScore> = Vec::new();
    for (i, (c, k)) in f_order.iter().enumerate() {
        let (m, n, mut sc) = match raw(&f_sims[i]) { Some(v) => v, None => continue };
        if let Some(pi) = p_order.iter().position(|(a, b)| a == c && b == k) {
            if let Some((_, _, ps)) = raw(&p_sims[pi]) {
                if ps > 0.0 { sc -= ps; }
            }
        }
        fout.push(SurprisalScore { category: c.clone(), key: k.clone(), max_cos: m, n, surprisal: sc });
    }
    fout.sort_by(|a, b| b.surprisal.partial_cmp(&a.surprisal).unwrap_or(std::cmp::Ordering::Equal));

    let mut sout: Vec<SurprisalScore> = Vec::new();
    for (i, name) in schema_names.iter().enumerate() {
        let (m, n, sc) = match raw(&s_sims[i]) { Some(v) => v, None => continue };
        sout.push(SurprisalScore { category: "schema".to_string(), key: name.clone(), max_cos: m, n, surprisal: sc });
    }
    sout.sort_by(|a, b| b.surprisal.partial_cmp(&a.surprisal).unwrap_or(std::cmp::Ordering::Equal));
    (fout, sout)
}
// =====================================================================
// 🌟 [BANK-NEUTRAL TEXT SCORING] 뱅크 크기 편향을 제거한 텍스트 채점기
// ---------------------------------------------------------------------
//  ── 왜 필요한가 ──
//   surprisal_dual_scores 는 √(2 ln N) 을 차감합니다.
//   그런데 한 코드의 앵커 구는 "purchase order / order form / buyer order" 처럼
//   동의어 나열이라 실효 표본 수가 N 보다 훨씬 작습니다.
//   앵커가 적은 코드(CI)가 앵커가 많은 코드(PO)를 구조적으로 이깁니다.
//   models/siglip2/vision_encoder.rs 의 score_patches_bank_neutral 이
//   이미 같은 문제를 행/열 이중 센터링으로 해결했으므로 그 도구를 그대로 이식합니다.
//
//  ── 왜 다국어가 성립하는가 ──
//   이 함수는 문자열을 전혀 보지 않습니다. 입력은 이미 다국어 임베딩 모델
//   (granite-embedding-97m-multilingual-r2)이 만든 벡터뿐이므로,
//   앵커가 영어 한 벌이어도 문서 언어와 무관하게 동작합니다.
//
//  ── 반환 ──
//   (keys, net[key][query], raw_cos[key][query])
//   net  : 행/열 이중 센터링 후 순위 점수 (뱅크 크기 무관)
//   raw_cos : 원시 Max-Pool 코사인 (진단 / 구조 게이트용)
// =====================================================================
pub fn bank_neutral_key_matrix<V: AsRef<Vec<f32>>>(
    queries: &[Vec<f32>],
    bias: &[(String, String, V)],
    prejudice: &[(String, String, V)],
) -> (Vec<String>, Vec<Vec<f32>>, Vec<Vec<f32>>) {
    use std::collections::HashMap;
    let n = queries.len();
    if n == 0 || bias.is_empty() {
        return (Vec::new(), Vec::new(), Vec::new());
    }
    // ── ① (category, key) 그룹 색인 ──
    let mut order: Vec<String> = Vec::new();
    let mut bias_idx: HashMap<String, Vec<usize>> = HashMap::new();
    let mut key_cat: HashMap<String, String> = HashMap::new();
    for (i, (c, k, _)) in bias.iter().enumerate() {
        if !bias_idx.contains_key(k) { order.push(k.clone()); }
        bias_idx.entry(k.clone()).or_default().push(i);
        key_cat.entry(k.clone()).or_insert_with(|| c.clone());
    }
    let mut prej_idx: HashMap<String, Vec<usize>> = HashMap::new();
    for (i, (_, k, _)) in prejudice.iter().enumerate() {
        prej_idx.entry(k.clone()).or_default().push(i);
    }
    // ── ② 편견 Max-Pool 은 그룹당 1회만 ──
    //    (bias 의 key 가 필드명, prejudice 의 key 가 카테고리명인 호출부가 있으므로
    //     조회는 key → 실패 시 category 순으로 해석합니다)
    let mut prej_pool: HashMap<String, Vec<f32>> = HashMap::new();
    for (gname, list) in prej_idx.iter() {
        let mut v = vec![f32::MIN; n];
        for i in 0..n {
            let q = &queries[i];
            if q.iter().all(|&x| x == 0.0) { continue; }
            let mut mp = f32::MIN;
            for &j in list {
                let e = prejudice[j].2.as_ref();
                if e.iter().all(|&x| x == 0.0) { continue; }
                let s = cosine_similarity(q, e);
                if s > mp { mp = s; }
            }
            v[i] = mp;
        }
        prej_pool.insert(gname.clone(), v);
    }
    // ── ③ 원시 Max-Pool 행렬 ──
    let m = order.len();
    let mut raw_b = vec![vec![f32::MIN; n]; m];
    let mut raw_p = vec![vec![f32::MIN; n]; m];
    for (ki, key) in order.iter().enumerate() {
        let bi = &bias_idx[key];
        let pv: Option<&Vec<f32>> = prej_pool
            .get(key)
            .or_else(|| key_cat.get(key).and_then(|c| prej_pool.get(c)));
        for i in 0..n {
            let q = &queries[i];
            if q.iter().all(|&x| x == 0.0) { continue; }
            let mut mb = f32::MIN;
            for &j in bi {
                let e = bias[j].2.as_ref();
                if e.iter().all(|&x| x == 0.0) { continue; }
                let s = cosine_similarity(q, e);
                if s > mb { mb = s; }
            }
            raw_b[ki][i] = mb;
            if let Some(pv) = pv { raw_p[ki][i] = pv[i]; }
        }
    }
    // ── ④ 행 기준선 + 전역 pooled σ ──
    //    뱅크마다 σ 를 쓰면 1구 뱅크의 z 가 무한히 부풀기 때문에 pooled 를 씁니다.
    let single = n < 2;
    let mut pooled_var = 0.0f32;
    let mut pooled_cnt = 0usize;
    let mut mu_b = vec![0.0f32; m];
    let mut mu_p = vec![0.0f32; m];
    for ki in 0..m {
        let (mut sb, mut sp, mut c) = (0.0f32, 0.0f32, 0usize);
        for i in 0..n {
            if raw_b[ki][i] == f32::MIN { continue; }
            sb += raw_b[ki][i];
            if raw_p[ki][i] != f32::MIN { sp += raw_p[ki][i]; }
            c += 1;
        }
        if c == 0 { continue; }
        mu_b[ki] = sb / c as f32;
        mu_p[ki] = sp / c as f32;
        for i in 0..n {
            if raw_b[ki][i] == f32::MIN { continue; }
            let d = raw_b[ki][i] - mu_b[ki];
            pooled_var += d * d;
            pooled_cnt += 1;
        }
    }
    let sd = if pooled_cnt > 1 {
        (pooled_var / pooled_cnt as f32).sqrt().max(1e-6)
    } else {
        1.0
    };
    // ── ⑤ 행 센터링 + 편견 상쇄 ──
    //    🌟 [SINGLE QUERY GUARD] 질의가 1개뿐이면 행 센터링이 자기 자신을 소거해
    //       전부 0 이 됩니다. 그 경우 원시 코사인 차를 그대로 씁니다.
    let mut net = vec![vec![f32::MIN; n]; m];
    for ki in 0..m {
        for i in 0..n {
            if raw_b[ki][i] == f32::MIN { continue; }
            if single {
                let p = if raw_p[ki][i] == f32::MIN { 0.0 } else { raw_p[ki][i].max(0.0) };
                net[ki][i] = raw_b[ki][i] - p;
            } else {
                let zb = (raw_b[ki][i] - mu_b[ki]) / sd;
                let zp = if raw_p[ki][i] == f32::MIN {
                    0.0
                } else {
                    ((raw_p[ki][i] - mu_p[ki]) / sd).max(0.0)
                };
                net[ki][i] = zb - zp;
            }
        }
    }
    // ── ⑥ 열 센터링 : '전 개념에 반응하는 잡음 라인' 공통 성분 제거 ──
    for i in 0..n {
        let (mut s, mut c) = (0.0f32, 0usize);
        for ki in 0..m {
            if net[ki][i] == f32::MIN { continue; }
            s += net[ki][i];
            c += 1;
        }
        if c < 2 { continue; }
        let mean = s / c as f32;
        for ki in 0..m {
            if net[ki][i] == f32::MIN { continue; }
            net[ki][i] -= mean;
        }
    }
    (order, net, raw_b)
}
/// 🌟 [BANK-NEUTRAL KEY SCORES] 위 행렬을 (key → 질의 전체 최댓값) 으로 축소합니다.
///    √(2 ln N) 차감이 없으므로 앵커 구 수에 무관한 공정한 경쟁이 됩니다.
pub fn bank_neutral_key_scores<V: AsRef<Vec<f32>>>(
    queries: &[Vec<f32>],
    bias: &[(String, String, V)],
    prejudice: &[(String, String, V)],
) -> Vec<(String, f32)> {
    let (keys, net, _) = bank_neutral_key_matrix(queries, bias, prejudice);
    let mut out: Vec<(String, f32)> = keys
        .iter()
        .enumerate()
        .map(|(ki, k)| {
            let mx = net[ki].iter().cloned().fold(f32::MIN, f32::max);
            (k.clone(), if mx == f32::MIN { 0.0 } else { mx })
        })
        .collect();
    out.sort_by(|a, b| b.1.partial_cmp(&a.1).unwrap_or(std::cmp::Ordering::Equal));
    out
}
// =====================================================================
// 🌟 [RELATIVE PREJUDICE GATE] 절대 대소 비교를 상대 우위 비교로 교체합니다.
// ---------------------------------------------------------------------
//  ── 무엇이 문제였나 (실측) ──
//   기존 게이트는 `if prej >= own { skip }` 입니다.
//   그런데 편견 뱅크는 '다른 필드의 라벨' 이므로,
//     recipient_address 의 편견에 sender_address 라벨이 들어 있고
//     라벨 'address' 는 두 필드 모두와 0.8+ 로 공명합니다.
//   결과:
//     🚫 'address' → 'recipient_address' | Label: 0.8061 <= Prej: 0.8374
//   전 조합 중 최고 점수(0.8061)가 삭제되고,
//   편견이 약한 party_address 만 살아남아 두 회사 주소가 한 값으로 접합되었습니다.
//
//  ── 대체 원리 ──
//   "이 라벨이 이 필드보다 다른 필드를 더 잘 설명하는가" 는
//   배타 배정(exclusive_assign_by_score)이 이미 판정합니다.
//   편견의 진짜 역할은 '이 라벨이 이 필드의 개념과 정반대인가' 이므로,
//   자기 라벨 뱅크와의 유사도를 기준선으로 삼아 상대 비교합니다.
//
//     drop  ⟺  prej > own * (1 + relief)
//     relief = 이 필드 라벨 뱅크의 내부 응집도로부터 유도
//
//   응집도가 높은 뱅크(동의어가 촘촘한 필드)는 편견과도 가깝게 나오므로
//   그만큼 관대해야 공정합니다. 새 매직 상수가 없습니다.
// =====================================================================
/// 라벨 뱅크의 내부 응집도. 구끼리의 평균 코사인입니다.
/// 뱅크가 1구면 응집도를 정의할 수 없으므로 0을 돌려줍니다.
pub fn bank_internal_cohesion(bank: &[Vec<f32>]) -> f32 {
    let valid: Vec<&Vec<f32>> = bank.iter().filter(|e| !e.iter().all(|&v| v == 0.0)).collect();
    if valid.len() < 2 {
        return 0.0;
    }
    let mut sum = 0.0f32;
    let mut cnt = 0usize;
    for i in 0..valid.len() {
        for j in (i + 1)..valid.len() {
            sum += cosine_similarity(valid[i], valid[j]);
            cnt += 1;
        }
    }
    if cnt == 0 { 0.0 } else { (sum / cnt as f32).max(0.0) }
}
/// 🌟 [RELATIVE PREJUDICE] 편견이 자기 점수를 '응집도만큼의 여유' 이상으로
///    앞설 때만 후보 자격을 박탈합니다.
///
///  반환 true = 폐기 대상
pub fn prejudice_dominates(own: f32, prej: f32, cohesion: f32) -> bool {
    if own <= 0.0 {
        return true;
    }
    // 응집도가 높을수록 편견과의 근접이 구조적으로 불가피하므로 여유를 넓힙니다.
    let relief = cohesion.clamp(0.0, 0.5);
    prej > own * (1.0 + relief)
}
/// [FILTER PREJUDICE BANK] 필터 카테고리의 prejudice 구를 수집합니다.
/// filter_category_phrases 의 prejudice 판입니다.
pub fn filter_category_prejudice_phrases(categories: &[&str]) -> Vec<(String, String, String)> {
    let mut out: Vec<(String, String, String)> = Vec::new();
    for cat in categories {
        if let Some(node) = crate::parsing::BIAS_DICT.get(cat).and_then(|v| v.as_object()) {
            for (key, val) in node {
                if let Some(p) = val.get("prejudice").and_then(|v| v.as_str()) {
                    for phrase in split_bias_phrases_full(p) {
                        if out.iter().any(|(c, k, e)| c == cat && k == key && e == &phrase) { continue; }
                        out.push((cat.to_string(), key.clone(), phrase));
                    }
                }
            }
        }
    }
    out
}

/// [ABSTRACT BRIDGE PREJUDICE] search_bridge.abstract_bridge 의 prejudice 구.
pub fn abstract_bridge_prejudice_phrases() -> Vec<(String, String, String)> {
    let mut out: Vec<(String, String, String)> = Vec::new();
    let node = match crate::parsing::BIAS_DICT
        .get("search_bridge")
        .and_then(|sb| sb.get("abstract_bridge"))
        .and_then(|v| v.as_object())
    { Some(n) => n, None => return out };

    for (target, val) in node {
        let mut it = target.splitn(2, '.');
        let cat = match it.next() { Some(c) if !c.is_empty() => c.to_string(), _ => continue };
        let key = match it.next() { Some(k) if !k.is_empty() => k.to_string(), _ => continue };
        if let Some(p) = val.get("prejudice").and_then(|v| v.as_str()) {
            for phrase in split_bias_phrases_full(p) {
                if out.iter().any(|(c, k, e)| c == &cat && k == &key && e == &phrase) { continue; }
                out.push((cat.clone(), key.clone(), phrase));
            }
        }
    }
    out
}

/// [STEM CANDIDATES] 같은 질의의 다른 토큰들과 공유하는 접두 어간 후보를 뽑습니다.
/// 언어별 조사/어미 사전을 쓰지 않고 '문자 접두 공유'라는 구조적 사실만 사용합니다.
/// 반환값은 길이 내림차순 어간 목록입니다.
pub fn shared_prefix_stems(word: &str, others: &[String]) -> Vec<String> {
    let w: Vec<char> = word.chars().collect();
    let mut stems: Vec<String> = Vec::new();
    for o in others {
        if o == word { continue; }
        let oc: Vec<char> = o.chars().collect();
        let mut n = 0usize;
        while n < w.len() && n < oc.len() && w[n] == oc[n] { n += 1; }
        if n < 2 { continue; }
        if n >= w.len() { continue; }
        let stem: String = w[..n].iter().collect();
        if !stems.iter().any(|s| s == &stem) { stems.push(stem); }
    }
    stems.sort_by(|a, b| b.chars().count().cmp(&a.chars().count()));
    stems
}

/// [ABSTRACT BRIDGE] bias.json 의 search_bridge.abstract_bridge 에서
/// (category, key, phrase) 트리플을 수집합니다.
/// 키는 "substantial_filters.weight" 처럼 "카테고리.키" 형태입니다.
/// 언어별 어휘를 코드에 두지 않고 bias.json 의 영어 브릿지 구만 사용하며,
/// 다국어 임베딩 모델이 교차언어 매칭을 담당합니다.
pub fn abstract_bridge_phrases() -> Vec<(String, String, String)> {
    let mut out: Vec<(String, String, String)> = Vec::new();
    let node = match crate::parsing::BIAS_DICT
        .get("search_bridge")
        .and_then(|sb| sb.get("abstract_bridge"))
        .and_then(|v| v.as_object())
    {
        Some(n) => n,
        None => return out,
    };

    for (target, val) in node {
        let mut it = target.splitn(2, '.');
        let cat = match it.next() { Some(c) if !c.is_empty() => c.to_string(), _ => continue };
        let key = match it.next() { Some(k) if !k.is_empty() => k.to_string(), _ => continue };

        for field in ["semantic", "bias"] {
            if let Some(s) = val.get(field).and_then(|v| v.as_str()) {
                for p in split_bias_phrases_full(s) {
                    if out.iter().any(|(c, k, e)| c == &cat && k == &key && e == &p) { continue; }
                    out.push((cat.clone(), key.clone(), p));
                }
            }
        }
    }
    out
}

// 🌟 [QWEN3 CORRECTION COSINE VERIFY] Qwen3 가 교정한 속성이 원본 속성보다
//    청크와 실제로 더 관련 있는지 코사인으로 검증합니다.
//    (로그: '남긴' → color → Qwen3 교정 → name. 그러나 name 도 '남긴' 과 무관)
//    교정 후 코사인이 교정 전보다 낮으면 교정을 폐기하고 UNASSIGN 합니다.
//    새 매직 상수 없이 '교정 후 < 교정 전' 부호 판정만 사용합니다.
pub fn correction_cosine_degraded(
    chunk_emb: &[f32],
    old_prop_embs: &Vec<Vec<f32>>,
    old_prop_weights: &Vec<f32>,
    new_prop_embs: &Vec<Vec<f32>>,
    new_prop_weights: &Vec<f32>,
) -> bool {
    let old_score = weighted_max_pool_sim(chunk_emb, old_prop_embs, old_prop_weights);
    let new_score = weighted_max_pool_sim(chunk_emb, new_prop_embs, new_prop_weights);
    new_score < old_score
}

// 🌟 [MAX-COVERAGE GREEDY ASSIGN] 청크가 굶어 죽지 않는 1:1 배타 배정.
//    exclusive_assign_by_score 의 rival 은 '같은 라인에 대한 다른 필드의 최고 점수'입니다.
//    따라서 margin_threshold = 0.0 으로 호출하면
//        margin = own - max_{f'≠f} matrix[f'][l] >= 0  ⟺  own 이 그 라인의 argmax
//    가 되어, 각 라인은 자기 argmax 필드 하나에만 주장을 낼 수 있습니다.
//    그 필드를 더 높은 점수의 다른 라인이 가져가면 차선책으로 이동할 기회 없이 소멸합니다.
//    (로그: '가디건'/'무거운'/'제품중에서'/'제품으로'/'중에서'/'메세지도'/'보여줘' 가 전부 이 경로로 전멸.
//     특히 color 뱅크는 50개 언어 색상명 ~700구라 Max-Pool 이 구조적으로 부풀려져
//     무관한 청크의 argmax 를 독식하는 '흡수 싱크' 로 작동했습니다)
//    여기서는 margin 을 '정렬 기준'이 아니라 '보고용 지표'로만 쓰고,
//    유효한 모든 (필드 × 라인) 주장을 절대 점수 순으로 그리디 배정하여 커버리지를 최대화합니다.
//    matrix[field][line], 음수는 무효 칸. 반환값 = field_idx -> Option<(line_idx, own, margin)>
pub fn greedy_exclusive_assign(matrix: &Vec<Vec<f32>>) -> Vec<Option<(usize, f32, f32)>> {
    let field_count = matrix.len();
    let mut result: Vec<Option<(usize, f32, f32)>> = vec![None; field_count];
    if field_count == 0 { return result; }

    let mut line_count = 0usize;
    for row in matrix.iter() { if row.len() > line_count { line_count = row.len(); } }
    if line_count == 0 { return result; }

    let get = |f: usize, l: usize| -> f32 {
        matrix.get(f).and_then(|row| row.get(l)).copied().unwrap_or(-1.0)
    };

    // 라인별 2순위 점수 (margin 보고용). 무효 칸(-1.0)은 절대 포함되지 않습니다.
    let mut runner_up = vec![-1.0f32; line_count];
    for l in 0..line_count {
        let mut best = -1.0f32;
        let mut second = -1.0f32;
        for f in 0..field_count {
            let v = get(f, l);
            if v < 0.0 { continue; }
            if v > best { second = best; best = v; }
            else if v > second { second = v; }
        }
        runner_up[l] = second;
    }

    let mut claims: Vec<(usize, usize, f32)> = Vec::new();
    for f in 0..field_count {
        for l in 0..line_count {
            let own = get(f, l);
            if own < 0.0 { continue; }
            claims.push((f, l, own));
        }
    }
    claims.sort_by(|a, b| b.2.partial_cmp(&a.2).unwrap_or(std::cmp::Ordering::Equal));

    let mut claimed_lines = vec![false; line_count];
    for (f, l, own) in claims {
        if result[f].is_some() { continue; }
        if claimed_lines[l] { continue; }
        let margin = if runner_up[l] < 0.0 { own } else { own - runner_up[l] };
        result[f] = Some((l, own, margin));
        claimed_lines[l] = true;
    }

    result
}

// 🌟 [SQL-EFFECTIVE FORMAT] 이 속성이 실제 SQL 필터를 바꾸는 '형식 확정' 필드인지 판정합니다.
//    lib.rs 의 convert_conditions_to_sql 이 물리 컬럼으로 매핑하는 것은
//    금액(amount) / 날짜(created_at, updated_at) / 송장(tracking_number LIKE) 계열뿐입니다.
//    문자열 속성(color/title/tags)은 SQL 을 전혀 바꾸지 않으므로
//    N:N 조합에서 별도 쿼리를 발행할 가치가 없고, 조건 완화 티어의 기준이 됩니다.
pub fn is_sql_effective_field(field_name: &str) -> bool {
    matches!(
        detect_field_format(field_name),
        FieldFormat::Date | FieldFormat::Numeric | FieldFormat::TrackingCode
    )
}

// 🌟 [BANK SIZE BIAS NORMALIZATION] Max-Pool 은 뱅크가 클수록 점수가 구조적으로 부풀려집니다.
//        E[max of N draws] ≈ μ + σ·√(2 ln N)
//    bias.json 루트 color.bias 는 50개 언어 색상명 ~700구라
//        color(N≈700) √(2 ln 700)=3.62  vs  title(N≈11) √(2 ln 11)=2.19  → 1.65배 유리
//    그 결과 '팔린'(0.6228) '남긴'(0.6365) '여름'(0.5433) 처럼 색상과 무관한 청크의
//    argmax 가 전부 color 로 몰리는 '흡수 싱크' 가 됩니다.
//    질의와 무관한 언어권 구(아랍어/힌디어/조지아어 색상명 등)를 런타임에 비활성화합니다.
//    판정 기준은 '이 뱅크 안에서의 코사인 중앙값' 이라는 상대 통계이므로 새 상수가 아닙니다.
//    뱅크가 작으면(중앙값 통계가 무의미) 전량 유지하여 정보 손실을 막습니다.
pub fn bank_size_normalized_mask(query_emb: &[f32], phrase_embs: &Vec<Vec<f32>>) -> Vec<bool> {
    let n = phrase_embs.len();
    let mut keep = vec![true; n];
    if n == 0 { return keep; }

    // 유효 구가 다른 스키마 뱅크(수 개~수십 개)와 같은 규모면 정규화가 불필요합니다.
    let valid: Vec<usize> = (0..n).filter(|&i| !phrase_embs[i].iter().all(|&v| v == 0.0)).collect();
    if valid.len() < 64 { return keep; }

    let mut sims: Vec<f32> = Vec::with_capacity(valid.len());
    for &i in &valid { sims.push(cosine_similarity(query_emb, &phrase_embs[i])); }

    let mut sorted = sims.clone();
    sorted.sort_by(|a, b| a.partial_cmp(b).unwrap_or(std::cmp::Ordering::Equal));
    let median = if sorted.len() % 2 == 0 {
        (sorted[sorted.len() / 2 - 1] + sorted[sorted.len() / 2]) / 2.0
    } else {
        sorted[sorted.len() / 2]
    };

    for (vi, &i) in valid.iter().enumerate() {
        if sims[vi] < median { keep[i] = false; }
    }
    keep
}

// 🌟 [BANK SIZE EQUALIZATION] bank_size_normalized_mask 는 중앙값 컷을 '단 한 번'만 수행합니다.
//    그래서 로그에서 color 뱅크가 603구 → 302구 로 절반만 줄었고,
//    Max-Pool 의 구조적 이득 E[max of N] ≈ μ + σ·√(2 ln N) 은
//        √(2 ln 603)=3.58 → √(2 ln 302)=3.38  (겨우 5.6% 감소)
//    에 그쳐, title(11구, √(2 ln 11)=2.19) 대비 여전히 1.54배 유리한 상태였습니다.
//    그 결과 색상과 무관한 '팔린'(0.5780) '남긴'(0.6365) 의 argmax 를 color 가 계속 독식했습니다.
//    여기서는 '이 스키마에서 정상 규모의 뱅크가 실제로 몇 구인가'(호출부 실측 중앙값)를
//    목표로 삼아 중앙값 컷을 반복 적용하여 유효 크기를 같은 규모로 수렴시킵니다.
//    각 반복은 '살아남은 구 집합 안에서의 상대 통계'만 사용하므로 절대 임계치가 없고,
//    target_size 도 호출부의 실측값이므로 새 매직 상수가 아닙니다.
pub fn bank_size_equalized_mask(query_emb: &[f32], phrase_embs: &Vec<Vec<f32>>, target_size: usize) -> Vec<bool> {
    let n = phrase_embs.len();
    let mut keep = vec![true; n];
    if n == 0 || target_size == 0 { return keep; }

    let mut valid: Vec<usize> = (0..n).filter(|&i| !phrase_embs[i].iter().all(|&v| v == 0.0)).collect();
    if valid.len() <= target_size { return keep; }

    let mut guard = 0usize;
    while valid.len() > target_size && guard < 64 {
        guard += 1;

        let mut sims: Vec<f32> = Vec::with_capacity(valid.len());
        for &i in &valid { sims.push(cosine_similarity(query_emb, &phrase_embs[i])); }

        let mut sorted = sims.clone();
        sorted.sort_by(|a, b| a.partial_cmp(b).unwrap_or(std::cmp::Ordering::Equal));
        let median = if sorted.len() % 2 == 0 {
            (sorted[sorted.len() / 2 - 1] + sorted[sorted.len() / 2]) / 2.0
        } else {
            sorted[sorted.len() / 2]
        };

        let mut next: Vec<usize> = Vec::with_capacity(valid.len() / 2 + 1);
        for (vi, &i) in valid.iter().enumerate() {
            if sims[vi] < median { keep[i] = false; } else { next.push(i); }
        }

        // 코사인이 전부 동률이면 한 구도 줄지 않아 무한 루프가 되므로 즉시 중단합니다.
        if next.len() == valid.len() { break; }
        valid = next;
    }

    keep
}

// 🌟 [FUNCTIONAL WORD] 조사·접속 표현은 어떤 속성의 값도 될 수 없습니다.
//    Stanza 는 '제품중에서'/'제품으로'/'중에서' 를 전부 NOUN 으로 태깅하므로 POS 로는 못 거릅니다.
//    (로그: 세 청크가 각각 condition / bundle_shipping / status 에 Margin -0.0091, -0.0020, +0.0000 로 억지 배정)
//
//    🌟 [LEMMA-FREE FALLBACK] 직전 구현은 lemma 잔여 판정과 deprel 에만 의존했는데,
//    로그의 Stanza 출력은 전 토큰이 'lemma:' 로 비어 있고 deprel 도 전달되지 않아
//    항상 false 를 반환했습니다. ([FUNCTIONAL WORD DROP] 이 한 번도 출력되지 않은 이유)
//    lemma/deprel 이 비어 있어도 동작하도록, 같은 질의 안의 '다른 토큰'을 원형 사전처럼 사용합니다.
//    어떤 언어든 조사·접속 표현은 '실질 형태소 + 기능 형태소' 구조를 갖고,
//    그 실질 형태소는 대개 같은 문장에 단독으로도 등장합니다.
//      '제품중에서' = '제품'(같은 질의에 단독 존재) + '중에서'
//      '제품으로'   = '제품'(같은 질의에 단독 존재) + '으로'
//      '중에서'     = 위에서 추출된 잔여와 완전일치
//    다국어 어휘 리터럴을 단 하나도 쓰지 않고, 문자열 구조 비교만으로 판정합니다.
pub fn is_functional_word_chunk(
    chunk: &str,
    words: &[String],
    lemmas: Option<&[String]>,
    deprels: Option<&[String]>,
) -> bool {
    let c = chunk.trim();
    if c.is_empty() { return true; }

    let idx_opt = words.iter().position(|w| w == c);

    // ① 이 토큰 자체가 UD 수식어/기능어 관계인가 (deprel 이 있을 때만)
    if let (Some(rels), Some(idx)) = (deprels, idx_opt) {
        if let Some(r) = rels.get(idx) {
            if is_modifier_deprel(r) { return true; }
        }
    }

    // ② Stanza lemma 가 유효할 때의 잔여 판정 (기존 경로 유지)
    if let (Some(lm), Some(idx)) = (lemmas, idx_opt) {
        if let Some(l) = lm.get(idx) {
            let lt = l.trim();
            if !lt.is_empty() && c != lt {
                let core: String = lt.chars().filter(|ch| ch.is_alphanumeric()).collect();
                let surf: String = c.chars().filter(|ch| ch.is_alphanumeric()).collect();
                if !core.is_empty() && surf.chars().count() > core.chars().count() && surf.starts_with(&core) {
                    let residue_len = surf.chars().count() - core.chars().count();
                    if core.chars().count() < residue_len { return true; }
                }
            }
        }
    }

    // ③ [LEMMA-FREE] 같은 질의의 다른 토큰을 원형으로 삼아 잔여를 구합니다.
    //    '제품' 이 단독 토큰으로 존재하므로 '제품중에서' 의 잔여 '중에서' 를 얻습니다.
    let surf: String = c.chars().filter(|ch| ch.is_alphanumeric()).collect();
    if surf.is_empty() { return true; }

    let mut residues: Vec<String> = Vec::new();
    for w in words.iter() {
        if w == c { continue; }
        let core: String = w.chars().filter(|ch| ch.is_alphanumeric()).collect();
        if core.is_empty() { continue; }
        if core.chars().count() >= surf.chars().count() { continue; }
        if !surf.starts_with(&core) { continue; }
        let residue: String = surf.chars().skip(core.chars().count()).collect();
        if residue.is_empty() { continue; }
        // 실질 형태소보다 잔여가 더 길면 그 토큰은 실질이 아니라 기능 표현입니다.
        if core.chars().count() < residue.chars().count() { return true; }
        if !residues.iter().any(|r| r == &residue) { residues.push(residue); }
    }

    // ④ 이 청크 자체가 다른 토큰에서 떨어져 나온 '잔여' 와 완전히 같으면 기능어입니다.
    //    ('중에서' 는 '제품중에서' 의 잔여와 완전일치)
    for other in words.iter() {
        if other == c { continue; }
        let o_surf: String = other.chars().filter(|ch| ch.is_alphanumeric()).collect();
        if o_surf.chars().count() <= surf.chars().count() { continue; }
        for base in words.iter() {
            if base == other || base == c { continue; }
            let b_core: String = base.chars().filter(|ch| ch.is_alphanumeric()).collect();
            if b_core.is_empty() { continue; }
            if b_core.chars().count() >= o_surf.chars().count() { continue; }
            if !o_surf.starts_with(&b_core) { continue; }
            let residue: String = o_surf.chars().skip(b_core.chars().count()).collect();
            if residue == surf { return true; }
        }
    }

    let _ = residues;
    false
}

// 🌟 [EXACT MATCH FILTER] bias.json 의 season_filters.*.exact_match 는
//    각 언어의 계절명을 '문자열 그대로' 담고 있는 확정 사전입니다. ("여름", "summer", "夏" ...)
//    로그에서 '여름' 은 summer(0.5591) 가 top(0.5596) 에 0.0005 차이로 밀려 2순위가 되었고,
//    그 결과 계절 감지 LLM 이 오염된 컨텍스트를 받아 'autumn' 을 환각했습니다.
//    코사인 경쟁 이전에 완전일치(==)로 확정하면 이 경로가 물리적으로 사라집니다.
//    부분문자열 포함(contains)이 아니라 배열 원소 완전일치이므로 의미 판정이 아닙니다.
pub fn exact_match_filter_key(category: &str, chunk: &str) -> Option<String> {
    let c = chunk.trim();
    if c.is_empty() { return None; }
    let lower = c.to_lowercase();

    let node = crate::parsing::BIAS_DICT.get(category)?.as_object()?;
    for (key, val) in node {
        let arr = match val.get("exact_match").and_then(|v| v.as_array()) { Some(a) => a, None => continue };
        for item in arr {
            if let Some(s) = item.as_str() {
                if s == c || s.to_lowercase() == lower {
                    return Some(key.clone());
                }
            }
        }
    }
    None
}

// 🌟 [AGGLUTINATIVE PREFIX MATCH] exact_match 배열을 '접두 사전' 으로 재사용합니다.
//  ── 왜 필요한가 ──
//   exact_match_filter_key 는 완전일치(==)만 봅니다. 그런데 교착어는
//     "클릭" + "한" + "게" → "클릭한게"
//     "올해" + "는"        → "올해는"
//   처럼 조사·어미가 어절에 붙어 한 토큰으로 도착하므로 완전일치가 구조적으로 실패합니다.
//   (로그 실측: exact_match 에 "클릭"/"클릭한" 이 있는데도 "클릭한게" 가 미매칭 →
//    슬라이딩 윈도우에 원형이 한 번도 올라가지 못해 NMS CANDIDATE 0건)
//  ── 판정 규칙 ──
//   exact_match 원소가 토큰의 '접두' 이고, 그 원소가 토큰보다 짧으면 어간으로 확정합니다.
//   가장 긴 접두를 우선하므로 "클릭한게" 는 "클릭" 보다 "클릭한" 을 먼저 채택합니다.
//   사전은 bias.json 이 소유하므로 코드에는 어떤 언어의 어휘도 등장하지 않습니다.
//  ── 반환 ──
//   Some((필터 키, 매칭된 접두 리터럴)) / 접두 후보가 없으면 None
pub fn prefix_match_filter_stem(category: &str, chunk: &str) -> Option<(String, String)> {
    let c = chunk.trim();
    if c.chars().count() < 3 { return None; }
    let lower = c.to_lowercase();

    let node = crate::parsing::BIAS_DICT.get(category)?.as_object()?;
    let mut best_key = String::new();
    let mut best_stem = String::new();

    for (key, val) in node {
        let arr = match val.get("exact_match").and_then(|v| v.as_array()) { Some(a) => a, None => continue };
        for item in arr {
            let s = match item.as_str() { Some(x) => x.trim(), None => continue };
            if s.is_empty() { continue; }
            let sl = s.to_lowercase();
            if sl.chars().count() < 2 { continue; }
            if sl.chars().count() >= lower.chars().count() { continue; }
            if !lower.starts_with(&sl) { continue; }
            if sl.chars().count() > best_stem.chars().count() {
                best_stem = s.to_string();
                best_key = key.clone();
            }
        }
    }

    if best_stem.is_empty() { None } else { Some((best_key, best_stem)) }
}

// 🌟 [NUMERIC COMPARISON SPLIT] '5000원 이하로' 처럼 숫자와 비교 표현이 붙은 청크를
//    (숫자 / 나머지) 로 구조 분해합니다.
//    로그에서 이 청크는 currency(0.5943) 로 배정되었는데, currency.bias 의 '원' 이
//    '5000원' 과 공명한 결과이며 정답은 sale_price lte 5000 입니다.
//    분해된 나머지("원 이하로")를 operators 뱅크와 코사인 비교하면
//    다국어 어휘 리터럴 없이 lte 를 확정할 수 있습니다.
//    반환: (숫자 문자열, 비교 표현 문자열). 숫자가 없으면 None.
pub fn split_numeric_and_comparator(chunk: &str) -> Option<(String, String)> {
    let c = chunk.trim();
    if c.is_empty() { return None; }

    let mut digits = String::new();
    let mut rest = String::new();
    let mut prev_digit = false;
    for ch in c.chars() {
        if ch.is_ascii_digit() || (ch == '.' && prev_digit) {
            digits.push(ch);
            prev_digit = ch.is_ascii_digit();
        } else if ch == ',' && prev_digit {
            // 천 단위 구분자는 숫자의 일부이므로 버립니다.
            prev_digit = true;
        } else {
            if !ch.is_whitespace() || !rest.ends_with(' ') { rest.push(ch); }
            prev_digit = false;
        }
    }

    let d = digits.trim_end_matches('.').to_string();
    if d.is_empty() { return None; }
    // 🌟 [COMPARATOR ENRICHMENT] rest 가 "원 이하로" 처럼 단위+비교 표현이면
    //    단위 문자를 제거하고 순수 비교 표현만 남깁니다.
    //    판정 기준: rest 의 첫 토큰이 알파벳/한글 1~2자이면서 숫자가 없으면 '단위'로 간주.
    //    다국어 하드코딩 없이 '토큰 길이 + 숫자 부재' 라는 구조 규칙만 사용합니다.
    let rest_trimmed = rest.trim();
    let rest_tokens: Vec<&str> = rest_trimmed.split_whitespace().collect();
    let comparator = if rest_tokens.len() >= 2 {
        let first_tok = rest_tokens[0];
        let first_has_digit = first_tok.chars().any(|c| c.is_ascii_digit());
        let first_len = first_tok.chars().count();
        // 첫 토큰이 2자 이하이고 숫자가 없으면 단위(원, 원, 円, $, € 등)로 간주하고 제거
        if !first_has_digit && first_len <= 2 {
            rest_tokens[1..].join(" ")
        } else {
            rest_trimmed.to_string()
        }
    } else {
        rest_trimmed.to_string()
    };
    Some((d, comparator))
}

// 🌟 [LOCALIZED BIAS NODE] bias.json 의 {lang}.{page_type}.{field} 노드를 원본 그대로 꺼냅니다.
//    스케줄러가 쥐고 있던 bias_target 은 이미 한 덩어리로 합쳐진 짧은 문자열이라
//    콤마가 없어 구 분할이 1개로 끝났고, 그래서 로그의 MaxPoolSim 이 CentroidSim 과
//    소수점 4자리까지 완전히 동일했습니다(= Max-Pool 이 사실상 작동하지 않았음).
//    여기서는 원본 JSON 을 직접 읽어 다국어 구 뱅크를 복원합니다.
fn bias_node(doc_lang: &str, page_type: &str, field_name: &str) -> Option<serde_json::Value> {
    let dict: &serde_json::Value = &crate::parsing::BIAS_DICT;
    // 🌟 [BIAS TYPE CANONICALIZE] BL / CI / PL 등 무역 서식 코드는 bias.json 에
    //    개별 노드가 없습니다. 공용 'shipping_doc' 노드로 접어 조회하지 않으면
    //    label_phrase_bank / prejudice_phrase_bank 가 항상 빈 배열을 돌려주고,
    //    그 결과 무역 문서의 헤더 코사인 맵과 청크 PLINKO 가 판정 근거를 잃습니다.
    let canon = crate::utils::bias_schema::canonical_bias_type(page_type);
    let lang_keys = [doc_lang, "en", "ko"];
    for lk in lang_keys {
        let lang_node = match dict.get(lk) { Some(v) => v, None => continue };
        if let Some(n) = lang_node.get(page_type).and_then(|p| p.get(field_name)) {
            return Some(n.clone());
        }
        if canon != page_type {
            if let Some(n) = lang_node.get(canon).and_then(|p| p.get(field_name)) {
                return Some(n.clone());
            }
        }
        if let Some(n) = lang_node.get("default").and_then(|p| p.get(field_name)) {
            let raw = n.to_string().replace("{TYPE}", page_type);
            if let Ok(v) = serde_json::from_str::<serde_json::Value>(&raw) { return Some(v); }
        }
    }
    None
}

// 🌟 [VALUE EXAMPLE FILTER] bias 안에는 라벨(주문상태)과 값 예시(2026-03-15, 603145678912, 15)가
//    섞여 있습니다. 헤더는 라벨이므로 값 예시를 뱅크에 넣으면 "번호" 같은 헤더가
//    "12345-67890" 에 끌려가는 오탐이 생깁니다. 숫자 비중과 길이로 값 예시를 배제합니다.
pub fn is_value_example_phrase(p: &str) -> bool {
    let compact: Vec<char> = p.chars().filter(|c| !c.is_whitespace()).collect();
    if compact.is_empty() { return true; }
    if compact.len() > 24 { return true; }
    let digits = compact.iter().filter(|c| c.is_ascii_digit()).count();
    digits * 4 >= compact.len()
}

// 🌟 [LABEL PHRASE BANK] semantic(가중치 1.00) + bias 중 비수치 구(가중치 0.92) 로
//    "컬럼 제목에 해당하는 구"만 모읍니다. 동일 문자열 구가 존재하면 코사인이 1.0 이 되므로
//    현재 로그의 +0.0006 ~ +0.0863 마진이 +0.25 이상으로 벌어집니다.
pub fn label_phrase_bank(doc_lang: &str, page_type: &str, field_name: &str) -> (Vec<String>, Vec<f32>) {
    let mut phrases: Vec<String> = Vec::new();
    let mut weights: Vec<f32> = Vec::new();
    if let Some(node) = bias_node(doc_lang, page_type, field_name) {
        for (key, w) in [("semantic", 1.0f32), ("bias", 0.92f32)] {
            if let Some(raw) = node.get(key).and_then(|v| v.as_str()) {
                for p in split_bias_phrases(raw) {
                    if is_value_example_phrase(&p) { continue; }
                    if phrases.iter().any(|e| e == &p) { continue; }
                    phrases.push(p);
                    weights.push(w);
                }
            }
        }
    }
    if phrases.len() > 48 { phrases.truncate(48); weights.truncate(48); }
    (phrases, weights)
}

// 🌟 [PREJUDICE PHRASE BANK] bias.json 이 필드마다 손으로 써 둔 "이 컬럼이 절대 아닌 라벨" 목록입니다.
//    예) tracking_number.prejudice 에는 "주문번호" 가 리터럴로 들어 있어
//    헤더 '주문번호' 가 운송장번호로 오매핑되는 사고를 코사인 1.0 으로 즉시 차단합니다.
pub fn prejudice_phrase_bank(doc_lang: &str, page_type: &str, field_name: &str) -> Vec<String> {
    let mut phrases: Vec<String> = Vec::new();
    if let Some(node) = bias_node(doc_lang, page_type, field_name) {
        if let Some(raw) = node.get("prejudice").and_then(|v| v.as_str()) {
            for p in split_bias_phrases(raw) {
                if is_value_example_phrase(&p) { continue; }
                if phrases.iter().any(|e| e == &p) { continue; }
                phrases.push(p);
            }
        }
    }
    if phrases.len() > 64 { phrases.truncate(64); }
    phrases
}

// 🌟 [EXCLUSIVE ASSIGNMENT] (필드 × 라인) 유사도 행렬을 받아 상호 배타적 1:1 그리디 매칭을 수행합니다.
// - own    : 해당 필드 바이어스와의 weighted max-pool 유사도
// - rival  : 같은 라인을 노리는 다른 필드들 중 최고 유사도
// - margin : own - rival (경쟁 필드 대비 실제 우위)
//
// 기존 방식(필드마다 독립 argmax)은 "본사" 같은 한 라인을 여러 필드가 중복 점유했고,
// 절대 임계치가 없어 점수 0.0000 짜리 쓰레기 라인도 무조건 힌트로 주입되었습니다.
// 반환값 = field_idx -> Option<(line_idx, own, margin)> / None 이면 "힌트 없음(null 유도)"
pub fn exclusive_assign(
    matrix: &Vec<Vec<f32>>,
    abs_threshold: f32,
    margin_threshold: f32,
) -> Vec<Option<(usize, f32, f32)>> {
    let field_count = matrix.len();
    let mut result: Vec<Option<(usize, f32, f32)>> = vec![None; field_count];
    if field_count == 0 { return result; }

    let mut line_count = 0usize;
    for row in matrix.iter() {
        if row.len() > line_count { line_count = row.len(); }
    }
    if line_count == 0 { return result; }

    let get = |f: usize, l: usize| -> f32 {
        matrix.get(f).and_then(|row| row.get(l)).copied().unwrap_or(-1.0)
    };

    let mut claims: Vec<(usize, usize, f32, f32)> = Vec::new();
    for f in 0..field_count {
        for l in 0..line_count {
            let own = get(f, l);
            if own < abs_threshold { continue; }

            // 🌟 [RIVAL FIX] rival 초기값 0.0 은 두 가지를 동시에 배제합니다.
            //    ① 무효 칸(-1.0)  → 의도된 배제
            //    ② double_center_matrix 를 거쳐 '유효하지만 음수'가 된 경쟁 필드 → 의도치 않은 배제
            //    ②가 발생하면 rival 이 0.0 으로 고정되어 margin = own 이 되고,
            //    경쟁이 치열한 라인일수록 오히려 margin 이 과대평가되어
            //    '경쟁자가 없는 약한 후보'가 먼저 선점하는 역전이 일어납니다.
            //    exclusive_assign_by_score 는 이미 abs_threshold 기반으로 교정되어 있으므로
            //    두 함수의 판정 규칙을 동일하게 통일합니다.
            let mut rival = f32::MIN;
            for other in 0..field_count {
                if other == f { continue; }
                let s = get(other, l);
                if s < abs_threshold { continue; }
                if s > rival { rival = s; }
            }
            let rival = if rival == f32::MIN { abs_threshold } else { rival };

            let margin = own - rival;
            if margin < margin_threshold { continue; }
            claims.push((f, l, own, margin));
        }
    }

    // 경쟁 우위(margin)가 큰 순서로, 동률이면 절대 유사도(own)가 큰 순서로 선점시킵니다.
    claims.sort_by(|a, b| {
        b.3.partial_cmp(&a.3)
            .unwrap_or(std::cmp::Ordering::Equal)
            .then(b.2.partial_cmp(&a.2).unwrap_or(std::cmp::Ordering::Equal))
    });

    let mut claimed_lines = vec![false; line_count];
    for (f, l, own, margin) in claims {
        if result[f].is_some() { continue; }
        if claimed_lines[l] { continue; }
        result[f] = Some((l, own, margin));
        claimed_lines[l] = true;
    }

    result
}

// 🌟 [SCORE-FIRST EXCLUSIVE ASSIGN]
// exclusive_assign 은 '경쟁 마진'이 큰 순서로 선점시키므로, 증거가 약하지만 경쟁자가 없는
// 라벨('판매자')이 증거가 압도적인 라벨('주문하신 분 이름', own 1.0)보다 먼저 필드를 채갑니다.
// 상세 페이지의 (라벨 → 필드) 매핑은 "가장 강한 증거부터 잠근다"가 옳으므로
// 절대 점수(own) 우선, 동률이면 마진 우선으로 정렬합니다.
pub fn exclusive_assign_by_score(
    matrix: &Vec<Vec<f32>>,
    abs_threshold: f32,
    margin_threshold: f32,
) -> Vec<Option<(usize, f32, f32)>> {
    let field_count = matrix.len();
    let mut result: Vec<Option<(usize, f32, f32)>> = vec![None; field_count];
    if field_count == 0 { return result; }

    let mut line_count = 0usize;
    for row in matrix.iter() {
        if row.len() > line_count { line_count = row.len(); }
    }
    if line_count == 0 { return result; }

    let get = |f: usize, l: usize| -> f32 {
        matrix.get(f).and_then(|row| row.get(l)).copied().unwrap_or(-1.0)
    };

    let mut claims: Vec<(usize, usize, f32, f32)> = Vec::new();
    for f in 0..field_count {
        for l in 0..line_count {
            let own = get(f, l);
            if own < abs_threshold { continue; }

            // 🌟 [RIVAL FIX] 후보 자격이 없는 칸(-1.0 같은 무효 표식)을 경쟁자로 세면
            //    margin = own - (-1.0) = own + 1.0 이 되어, 경쟁자가 아예 없는 쓰레기 후보가
            //    가장 강한 주장처럼 정렬됩니다. (로그의 '상품금액'→'bank' Margin +1.0407)
            //    abs_threshold 를 통과한 '실제 후보'만 경쟁자로 인정합니다.
            let mut rival = f32::MIN;
            for other in 0..field_count {
                if other == f { continue; }
                let s = get(other, l);
                if s < abs_threshold { continue; }
                if s > rival { rival = s; }
            }
            let rival = if rival == f32::MIN { abs_threshold } else { rival };

            let margin = own - rival;
            if margin < margin_threshold { continue; }
            claims.push((f, l, own, margin));
        }
    }

    claims.sort_by(|a, b| {
        b.2.partial_cmp(&a.2)
            .unwrap_or(std::cmp::Ordering::Equal)
            .then(b.3.partial_cmp(&a.3).unwrap_or(std::cmp::Ordering::Equal))
    });

    let mut claimed_lines = vec![false; line_count];
    for (f, l, own, margin) in claims {
        if result[f].is_some() { continue; }
        if claimed_lines[l] { continue; }
        result[f] = Some((l, own, margin));
        claimed_lines[l] = true;
    }

    result
}

// 🌟 [SELF-POISON GUARD]
// bias.json 의 prejudice 는 "다른 필드 semantic 전부"로 기계 생성되어 있어서
// recipient_address.prejudice 안에 '받는사람' 이, sender_phone.prejudice 안에 '주문자' 가
// 들어가 있습니다. 그 결과 정답 라벨('받으시는 분 주소')이 자기 편견에 맞아 -0.1143 로 자멸합니다.
// 판정 규칙(문자열 비교가 아니라 순수 코사인):
//   편견 구 p 가 '자기 라벨 뱅크'를 경쟁 필드 라벨 뱅크보다 더 잘 설명하면,
//   그 p 는 이 필드의 편견이 될 자격이 없습니다.
pub fn self_poisoned_prejudice_mask(
    own_label_embs: &Vec<Vec<f32>>,
    prej_embs: &Vec<Vec<f32>>,
    all_label_embs: &[Vec<Vec<f32>>],
    self_index: usize,
) -> Vec<bool> {
    let mut mask = vec![false; prej_embs.len()];
    if own_label_embs.is_empty() { return mask; }
    for (pi, pe) in prej_embs.iter().enumerate() {
        if pe.iter().all(|&v| v == 0.0) { continue; }
        let own = max_pool_sim(pe, own_label_embs);
        let mut rival = 0.0f32;
        for (fi, bank) in all_label_embs.iter().enumerate() {
            if fi == self_index { continue; }
            if bank.is_empty() { continue; }
            let s = max_pool_sim(pe, bank);
            if s > rival { rival = s; }
        }
        if own >= rival { mask[pi] = true; }
    }
    mask
}

// 🌟 [SELECT GROUP] 상태(status)는 PUG 로는 절대 판정할 수 없습니다.
//    parsing.rs 의 generate_pug_lines 가 selected 가 아닌 option 을 전부 버리기 때문에
//    '배송완료 / 반품 / 교환' 이라는 열거 후보 집합 자체가 PUG 에서 소멸합니다.
//    따라서 원본 HTML 에서 select 컨트롤과 그 옵션 전체를 따로 수집합니다.
#[derive(Debug, Clone)]
pub struct SelectGroup {
    pub selector: String,     // 실제 CSS selector (LLM 이 복사할 원본)
    pub role_phrase: String,  // name/id 를 자연어화 + 같은 tr 의 th 라벨
    pub options: Vec<String>, // 모든 옵션 텍스트
    pub selected: String,     // selected 된 옵션 텍스트
}

pub fn collect_select_groups(html: &str) -> Vec<SelectGroup> {
    let doc = scraper::Html::parse_document(html);
    let sel_select = match scraper::Selector::parse("select") { Ok(s) => s, Err(_) => return Vec::new() };
    let sel_option = match scraper::Selector::parse("option") { Ok(s) => s, Err(_) => return Vec::new() };
    let sel_th = scraper::Selector::parse("th").ok();

    let mut out: Vec<SelectGroup> = Vec::new();
    for (idx, el) in doc.select(&sel_select).enumerate() {
        let name = el.value().attr("name").unwrap_or("").to_string();
        let id = el.value().attr("id").unwrap_or("").to_string();

        let selector = if !id.is_empty() {
            format!("select#{}", id)
        } else if !name.is_empty() {
            format!("select[name=\"{}\"]", name)
        } else {
            format!("select:nth-of-type({})", idx + 1)
        };

        let mut options: Vec<String> = Vec::new();
        let mut selected = String::new();
        for opt in el.select(&sel_option) {
            let txt = opt.text().collect::<Vec<_>>().join(" ")
                .split_whitespace().collect::<Vec<_>>().join(" ");
            if txt.is_empty() { continue; }
            if opt.value().attr("selected").is_some() && selected.is_empty() {
                selected = txt.clone();
            }
            if !options.iter().any(|o| o == &txt) { options.push(txt); }
        }
        if options.is_empty() { continue; }
        if selected.is_empty() { selected = options[0].clone(); }
        if options.len() > 40 { options.truncate(40); }

        // 역할 문구 : name/id 자연어화 + '같은 tr 안의 th' 라벨
        let mut role = humanize_url_token(&format!("{} {}", name, id));
        let mut cur = el.parent();
        let mut hops = 0usize;
        while let Some(p) = cur {
            hops += 1;
            if hops > 8 { break; }
            if let Some(pe) = p.value().as_element() {
                let tag = pe.name().to_lowercase();
                if tag == "tr" {
                    if let (Some(pref), Some(th_sel)) = (scraper::ElementRef::wrap(p), sel_th.as_ref()) {
                        if let Some(l) = pref.select(th_sel).next() {
                            let t = l.text().collect::<Vec<_>>().join(" ")
                                .split_whitespace().collect::<Vec<_>>().join(" ");
                            if !t.is_empty() { role = format!("{} {}", t, role).trim().to_string(); }
                        }
                    }
                    break;
                }
                if tag == "form" || tag == "body" { break; }
            }
            cur = p.parent();
        }
        if role.trim().is_empty() { role = "select control".to_string(); }

        out.push(SelectGroup { selector, role_phrase: role, options, selected });
    }
    if out.len() > 24 { out.truncate(24); }
    out
}

// 🌟 [STATUS CANONICAL BANK] 상태는 '취소' 라는 한국어 리터럴을 찾는 게 아니라,
//    bias.json 의 status_filters(영어 캐노니컬)와 코사인으로 대조합니다.
//    '배송완료' → complete, '반품' → return, '교환' → exchange 가 다국어 임베딩으로 연결됩니다.
pub fn enum_status_keys(page_type: &str) -> Vec<&'static str> {
    match page_type {
        "tracking" => vec!["draft", "progress", "return", "complete"],
        "goods" => vec!["draft", "show", "hide", "progress", "stop", "cancel", "refund", "return", "exchange", "expire", "complete"],
        "order" => vec!["draft", "progress", "stop", "cancel", "refund", "return", "exchange", "expire", "complete"],
        "coupon" | "event" => vec!["show", "progress", "hide", "stop", "cancel", "expire", "complete"],
        "review" => vec!["progress", "stop", "cancel", "refund", "return", "exchange", "expire", "complete"],
        _ => vec!["show", "progress", "remove", "hide", "stop", "cancel", "refund", "return", "exchange", "expire", "complete"],
    }
}

pub fn status_key_phrases(key: &str) -> Vec<String> {
    let mut v: Vec<String> = vec![key.to_string()];
    if let Some(node) = crate::parsing::BIAS_DICT.get("status_filters").and_then(|s| s.get(key)) {
        if let Some(b) = node.get("bias").and_then(|x| x.as_str()) {
            for p in split_bias_phrases(b) {
                if !v.iter().any(|e| e == &p) { v.push(p); }
            }
        }
    }
    if v.len() > 24 { v.truncate(24); }
    v
}

// 🌟 [FORMAT FAMILY] 스키마 필드가 물리적으로 어떤 "생김새"의 값을 가져야 하는지 분류합니다.
// 다국어 임베딩은 짧은 한국어 문자열끼리 기본 유사도가 0.5를 넘기 때문에
// ("번호" vs "운송장번호" = 0.67) 코사인 임계치만으로는 컬럼을 절대 분리할 수 없습니다.
// 유사도를 재기 "전에" 값의 형태부터 검증해야 오매칭이 원천 차단됩니다.
#[derive(Clone, Copy, PartialEq, Eq, Debug)]
pub enum FieldFormat {
    Date,         // registration_date, payment_date, started_at, expired_at ...
    TrackingCode, // tracking_number, barcode, gtin, mpn
    Identifier,   // id, code, no, index, stock_keeping_unit
    Link,         // link, url
    Numeric,      // price, amount, quantity, weight, fee, discount ...
    Enum,         // status, payment_method, condition, currency, bank, card
    Synthesis,    // insight, summary, analysis (LLM 이 문장을 합성하는 필드)
    // 🌟 [NEW] 연락처는 '문자를 포함해야 한다'는 Text 규칙과 정반대의 생김새(숫자+하이픈)라
    //    Text 로 두면 'test3@gmail.com' 같은 이메일 셀이 형식 게이트를 그대로 통과합니다.
    Phone,        // sender_phone, recipient_phone, telephone, cellphone, number(연락처)
    // 🌟 [NEW] 주소는 반드시 2토큰 이상입니다. '우체국' / 'https://…' 같은 단일 토큰을 원천 차단합니다.
    Address,      // sender_address, recipient_address, address
    Text,         // title, name, description ...
}

pub fn detect_field_format(field_name: &str) -> FieldFormat {
    let lower = field_name.to_lowercase();
    let keys: Vec<String> = lower.split(',').map(|s| s.trim().to_string()).collect();
    let has = |k: &str| keys.iter().any(|x| x == k);
    if keys.iter().any(|k| k.contains("insight") || k.contains("summary") || k.contains("analysis")) {
        return FieldFormat::Synthesis;
    }
    if keys.iter().any(|k| k.contains("tracking_number") || k == "barcode" || k == "gtin" || k == "mpn") {
        return FieldFormat::TrackingCode;
    }
    // 🌟 [TRADE IDENTIFIER] hs_code / container_number / seal_number 는 값이 순수 숫자이거나
    //    '영문 4자 + 숫자 7자' 구조입니다. Text 로 두면 is_alphabetic() 게이트에서
    //    "583948392" 가 탈락해 청크가 저장조차 되지 않습니다.
    //    (has("code") 는 완전일치라 "hs_code" 를 잡지 못했습니다)
    if has("hs_code") || has("container_number") || has("seal_number") {
        return FieldFormat::Identifier;
    }
    if has("id") || has("code") || has("no") || has("index") || has("stock_keeping_unit") {
        return FieldFormat::Identifier;
    }
    if keys.iter().any(|k| k.contains("link") || k.contains("url")) {
        return FieldFormat::Link;
    }
    // 🌟 [TRADE DATE] etd / eta 는 'date' 도 '_at' 도 포함하지 않아 Text 로 떨어졌습니다.
    //    무역 서식에서 이 두 축은 항상 날짜입니다.
    if keys.iter().any(|k| k.contains("date") || k.ends_with("_at") || k == "etd" || k == "eta") {
        return FieldFormat::Date;
    }
    // 🌟 tracking_number 는 위에서 이미 반환되었으므로 여기의 "number" 는 순수 연락처입니다.
    if keys.iter().any(|k| {
        k.ends_with("phone") || k == "tel" || k == "telephone" || k == "mobile"
            || k == "cellphone" || k == "contact" || k == "number"
    }) {
        return FieldFormat::Phone;
    }
    if keys.iter().any(|k| k == "address" || k.ends_with("_address")) {
        return FieldFormat::Address;
    }
    // 🌟 [TRADE ENUM] incoterms / transport_mode / payment_terms / freight_payment_term /
    //    package_unit / unit / type_size 는 전부 '정해진 코드 집합' 입니다.
    //    Enum 은 어떤 값이든 통과시키므로 오탐이 없고, Text 의 알파벳 요구를 우회합니다.
    if keys.iter().any(|k| {
        k.contains("status") || k.contains("payment_method") || k.contains("payment_origin")
            || k.contains("condition") || k.contains("currency") || k == "bank" || k == "card"
            || k.contains("incoterm") || k.contains("_term") || k.contains("transport_mode")
            || k == "unit" || k == "package_unit" || k == "type_size"
    }) {
        return FieldFormat::Enum;
    }
    // 🌟 [TRADE NUMERIC] package_count / volume / local_charges 는 기존 어느 패턴에도
    //    걸리지 않아 Text 로 떨어졌고, "4" / "12.5" / "150" 이 전부
    //    FORMAT GATE 에서 unclassified 로 강등 → 인덱싱 대상에서 폐기되었습니다.
    if keys.iter().any(|k| {
        k.contains("price") || k.contains("amount") || k.contains("quantity") || k.contains("weight")
            || k == "width" || k == "height" || k == "length" || k.contains("fee")
            || k.contains("discount") || k.contains("usage_") || k.contains("threshold")
            || k.contains("duration")
            || k.ends_with("_count") || k == "volume" || k.contains("charge")
    }) {
        return FieldFormat::Numeric;
    }
    FieldFormat::Text
}

// 🌟 "a-b-c" / "a/b/c" / "a.b.c" 형태의 실제 날짜 리터럴이 있는지 판정합니다.
// "615600", "9", "26031514155635" 같은 순수 숫자 덩어리는 날짜로 인정하지 않습니다.
pub fn has_date_literal(s: &str) -> bool {
    let chars: Vec<char> = s.chars().collect();
    let n = chars.len();
    let mut i = 0usize;
    while i < n {
        if chars[i].is_ascii_digit() {
            let start1 = i;
            let mut j = i;
            while j < n && chars[j].is_ascii_digit() { j += 1; }
            let g1 = j - start1;

            if j < n && (chars[j] == '-' || chars[j] == '/' || chars[j] == '.') {
                let sep = chars[j];
                let mut k = j + 1;
                let start2 = k;
                while k < n && chars[k].is_ascii_digit() { k += 1; }
                let g2 = k - start2;

                if g2 >= 1 && k < n && chars[k] == sep {
                    let mut m = k + 1;
                    let start3 = m;
                    while m < n && chars[m].is_ascii_digit() { m += 1; }
                    let g3 = m - start3;
                    // 🌟 [DATE SHAPE GATE] 월(g2)·일(g3)은 물리적으로 최대 2자리.
                    //    "010-3333-3333"(g2=4, g3=4) 같은 전화번호를 날짜로 오인하는 것을 원천 차단.
                    if g3 >= 1 && g1 >= 2 && g1 <= 4 && g2 <= 2 && g3 <= 2 { return true; }
                }
            }
            i = j;
        } else {
            i += 1;
        }
    }
    false
}

// 🌟 값 안에서 "숫자를 포함한 영숫자 토큰"의 최대 길이를 구합니다. (운송장/코드 판정용)
pub fn longest_code_token_len(s: &str) -> usize {
    let mut best = 0usize;
    for tok in s.split(|c: char| !c.is_alphanumeric()) {
        if !tok.chars().any(|c| c.is_ascii_digit()) { continue; }
        let l = tok.chars().count();
        if l > best { best = l; }
    }
    best
}

// 🌟 값이 실제로 URL(href) 안에 박혀 있는 식별자인지 판정합니다.
// id 의 정의는 "링크로 이어지는 키"이므로, href 풀에 없는 숫자는 id 가 아니라 code 입니다.
pub fn value_token_in_url_pool(value: &str, url_pool: &str) -> bool {
    if url_pool.trim().is_empty() { return false; }
    let pool = url_pool.to_lowercase();
    for tok in value.split(|c: char| !c.is_alphanumeric()) {
        if tok.chars().count() < 4 { continue; }
        if !tok.chars().any(|c| c.is_ascii_digit()) { continue; }
        if pool.contains(&tok.to_lowercase()) { return true; }
    }
    false
}

// 🌟 [MARKUP RESIDUE] 0.6B 모델은 [VECTOR MATCH RESULT] 라인을 복사할 때
//    "tr", "td | 364235" 처럼 구조 태그를 그대로 반환합니다.
//    Text 게이트는 알파벳 2자면 통과시키므로 "tr" 이 정상값으로 저장되어 버립니다.
pub fn is_bare_markup_token(value: &str) -> bool {
    const TAGS: [&str; 31] = [
        "html", "head", "body", "div", "span", "p", "a", "ul", "ol", "li", "dl", "dt", "dd",
        "table", "thead", "tbody", "tfoot", "tr", "td", "th", "form", "input", "select", "option",
        "textarea", "button", "label", "img", "section", "colgroup", "col",
    ];
    let v = value.trim().to_ascii_lowercase();
    if v.is_empty() { return true; }
    if TAGS.contains(&v.as_str()) { return true; }
    if v.contains('|') {
        let head = v.split('|').next().unwrap_or("").trim().to_string();
        let token = head.split(|c: char| c == '[' || c == ' ' || c == '(').next().unwrap_or("");
        if TAGS.contains(&token) { return true; }
    }
    false
}

// 🌟 [MARKUP STRIP] "td | 24120419364235" 처럼 태그 접두어가 붙어 돌아온 답변에서
//    실제 값 부분만 남깁니다. (파이프가 없거나 앞이 태그가 아니면 원문 그대로 보존)
pub fn strip_markup_prefix(value: &str) -> String {
    const TAGS: [&str; 31] = [
        "html", "head", "body", "div", "span", "p", "a", "ul", "ol", "li", "dl", "dt", "dd",
        "table", "thead", "tbody", "tfoot", "tr", "td", "th", "form", "input", "select", "option",
        "textarea", "button", "label", "img", "section", "colgroup", "col",
    ];
    let v = value.trim();
    if let Some(p) = v.find('|') {
        let head = v[..p].trim().to_ascii_lowercase();
        let token = head.split(|c: char| c == '[' || c == ' ' || c == '(').next().unwrap_or("");
        if TAGS.contains(&token) {
            return v[p + 1..].trim().to_string();
        }
    }
    v.to_string()
}

// 🌟 [DATE LITERAL] LLM 을 거치지 않고 벡터가 짚어준 라인에서 날짜 리터럴만 직접 뽑아냅니다.
pub fn extract_date_literal(s: &str) -> Option<String> {
    let re = regex::Regex::new(r"\d{2,4}[-/\.]\d{1,2}[-/\.]\d{1,2}(?:[ T]\d{1,2}:\d{2}(?::\d{2})?)?").ok()?;
    re.find(s).map(|m| m.as_str().trim().to_string())
}

// 🌟 [PURE NUMERIC] 열거형(Enum)은 '상태/수단/기관명' 이므로 순수 금액·수량이 될 수 없습니다.
//    '615600원', '(-) 0원', '0' 처럼 숫자와 단위 한 글자로만 이루어진 값을 구조적으로 판별합니다.
//    (특정 통화 문자를 하드코딩하지 않고 '알파벳류 글자 수 <= 1' 로 일반화합니다)
pub fn is_pure_numeric_value(value: &str) -> bool {
    let v = value.trim();
    if v.is_empty() { return false; }
    let digits = v.chars().filter(|c| c.is_ascii_digit()).count();
    if digits == 0 { return false; }
    let letters = v.chars().filter(|c| c.is_alphabetic()).count();
    letters <= 1
}

pub fn value_matches_format(fmt: FieldFormat, value: &str) -> bool {
    let v = value.trim();
    if v.is_empty() { return false; }
    // 어떤 형식이든 구조 태그 잔재는 데이터가 아닙니다.
    if is_bare_markup_token(v) { return false; }
    match fmt {
        FieldFormat::Synthesis => true,
        FieldFormat::Enum => !has_date_literal(v),
        FieldFormat::Text => v.chars().any(|c| c.is_alphabetic()) && v.chars().count() >= 2,
        FieldFormat::Numeric => {
            if has_date_literal(v) {
                return false;
            }

            let core: String = v
                .chars()
                .filter(|c| !c.is_whitespace() && *c != ',' && *c != '%')
                .collect();
            if core.is_empty() {
                return false;
            }
            // 통화 기호와 부호는 허용합니다. (₩ 12,500 / -350.00 / $78,500)
            let stripped: String = core
                .chars()
                .filter(|c| c.is_ascii_digit() || *c == '.' || *c == '-' || *c == '+')
                .collect();
            let symbols = core.chars().count().saturating_sub(stripped.chars().count());
            // 기호가 숫자보다 많으면 수치가 아닙니다. (예: "FOB Busan")
            if symbols * 2 > core.chars().count() {
                return false;
            }
            stripped.chars().any(|c| c.is_ascii_digit())
        },
        FieldFormat::Date => {
            has_date_literal(v)
        },
        FieldFormat::Link => v.contains('/') || v.to_lowercase().starts_with("http"),
        FieldFormat::TrackingCode => !has_date_literal(v) && longest_code_token_len(v) >= 8,
        FieldFormat::Identifier => !has_date_literal(v) && longest_code_token_len(v) >= 4,
        FieldFormat::Phone => {
            let digits = v.chars().filter(|c| c.is_ascii_digit()).count();
            if digits < 7 { return false; }
            v.chars().all(|c| c.is_ascii_digit() || c.is_whitespace() || "+-().,".contains(c))
        },
        FieldFormat::Address => {
            if v.split_whitespace().count() < 2 { return false; }
            if v.chars().count() < 6 { return false; }
            let lower = v.to_lowercase();
            if lower.starts_with("http") { return false; }
            v.chars().any(|c| c.is_alphabetic())
        },
    }
}

pub fn is_id_link_field(field_name: &str) -> bool {
    let lower = field_name.to_lowercase();
    let keys: Vec<&str> = lower.split(',').map(|s| s.trim()).collect();
    keys.contains(&"id") && keys.contains(&"link")
}

pub fn double_center_matrix(raw: &Vec<Vec<f32>>) -> Vec<Vec<f32>> {
    let field_count = raw.len();
    if field_count == 0 { return Vec::new(); }
    let mut line_count = 0usize;
    for row in raw.iter() { if row.len() > line_count { line_count = row.len(); } }

    let mut out = vec![vec![-1.0f32; line_count]; field_count];
    if line_count == 0 { return out; }

    let mut line_sum = vec![0.0f32; line_count];
    let mut line_cnt = vec![0usize; line_count];
    let mut field_sum = vec![0.0f32; field_count];
    let mut field_cnt = vec![0usize; field_count];
    let mut global_sum = 0.0f32;
    let mut global_cnt = 0usize;

    for f in 0..field_count {
        for l in 0..raw[f].len() {
            let v = raw[f][l];
            if v < 0.0 { continue; }
            line_sum[l] += v; line_cnt[l] += 1;
            field_sum[f] += v; field_cnt[f] += 1;
            global_sum += v; global_cnt += 1;
        }
    }

    let global_mean = if global_cnt > 0 { global_sum / (global_cnt as f32) } else { 0.0 };
    let line_mean: Vec<f32> = (0..line_count)
        .map(|l| if line_cnt[l] > 0 { line_sum[l] / (line_cnt[l] as f32) } else { global_mean })
        .collect();
    let field_mean: Vec<f32> = (0..field_count)
        .map(|f| if field_cnt[f] > 0 { field_sum[f] / (field_cnt[f] as f32) } else { global_mean })
        .collect();

    for f in 0..field_count {
        for l in 0..raw[f].len() {
            let v = raw[f][l];
            if v < 0.0 { continue; }
            let lm = if line_cnt[l] > 1 { line_mean[l] } else { global_mean };
            let fm = if field_cnt[f] > 1 { field_mean[f] } else { global_mean };
            out[f][l] = v - lm - fm + global_mean;
        }
    }
    out
}

pub fn split_href_parts(href: &str) -> (String, String, String) {
    let mut rest: &str = href.trim();
    let mut host = String::new();

    if let Some(pos) = rest.find("://") {
        rest = &rest[pos + 3..];
        let end = rest.find(|c: char| c == '/' || c == '?' || c == '#').unwrap_or(rest.len());
        host = rest[..end].to_string();
        rest = &rest[end..];
    } else if rest.starts_with("//") {
        let tmp = &rest[2..];
        let end = tmp.find(|c: char| c == '/' || c == '?' || c == '#').unwrap_or(tmp.len());
        host = tmp[..end].to_string();
        rest = &tmp[end..];
    }

    let no_frag = match rest.find('#') { Some(p) => &rest[..p], None => rest };
    match no_frag.find('?') {
        Some(p) => (host, no_frag[..p].to_string(), no_frag[p + 1..].to_string()),
        None => (host, no_frag.to_string(), String::new()),
    }
}

pub fn host_region_end(link: &str) -> usize {
    let total = link.len();
    if let Some(p) = link.find("://") {
        let after = p + 3;
        let rest = &link[after..];
        return rest.find(|c: char| c == '/' || c == '?' || c == '#').map(|e| after + e).unwrap_or(total);
    }
    if link.starts_with("//") {
        let rest = &link[2..];
        return rest.find(|c: char| c == '/' || c == '?' || c == '#').map(|e| 2 + e).unwrap_or(total);
    }
    0
}

pub fn humanize_url_token(raw: &str) -> String {
    let chars: Vec<char> = raw.chars().collect();
    let mut out = String::new();
    for (i, ch) in chars.iter().enumerate() {
        if ch.is_alphanumeric() {
            let need_space = if i == 0 {
                false
            } else {
                let p = chars[i - 1];
                if p.is_alphanumeric() {
                    (p.is_lowercase() && ch.is_uppercase()) || (p.is_ascii_digit() != ch.is_ascii_digit())
                } else {
                    true
                }
            };
            if need_space && !out.is_empty() && !out.ends_with(' ') { out.push(' '); }
            for lc in ch.to_lowercase() { out.push(lc); }
        } else if !out.is_empty() && !out.ends_with(' ') {
            out.push(' ');
        }
    }
    out.split_whitespace().collect::<Vec<_>>().join(" ")
}

#[derive(Debug, Clone)]
pub struct IdLinkCandidate {
    pub token: String,
    pub href: String,
    pub role_phrase: String,
    pub is_host_part: bool,
    pub prior: f32,
}

fn push_candidates_from_href(
    href: &str,
    out: &mut Vec<IdLinkCandidate>,
    seen: &mut std::collections::HashSet<String>,
) {
    let (host, path, query) = split_href_parts(href);
    let segs: Vec<String> = path.split('/')
        .map(|s| s.trim().to_string())
        .filter(|s| !s.is_empty())
        .collect();
    let res_role = segs.last()
        .map(|s| humanize_url_token(s.split('.').next().unwrap_or(s.as_str())))
        .unwrap_or_default();

    // 1) 쿼리 파라미터 값 : 파라미터 키가 그대로 역할 문구가 됩니다. (product_no=18 → "product register product no")
    if !query.is_empty() {
        for pair in query.split('&') {
            let (k, v) = match pair.find('=') {
                Some(p) => (&pair[..p], &pair[p + 1..]),
                None => continue,
            };
            let val = v.trim();
            if val.is_empty() { continue; }
            if !val.chars().any(|c| c.is_ascii_digit()) { continue; }
            if val.chars().count() > 32 { continue; }

            let key_role = humanize_url_token(k);
            if key_role.is_empty() { continue; }
            let role = if key_role.split_whitespace().count() >= 2 || res_role.is_empty() {
                key_role
            } else {
                format!("{} {}", res_role, key_role).trim().to_string()
            };

            let dedup = format!("Q::{}::{}", val, role);
            if !seen.insert(dedup) { continue; }
            out.push(IdLinkCandidate {
                token: val.to_string(),
                href: href.to_string(),
                role_phrase: role,
                is_host_part: false,
                prior: 1.00,
            });
        }
    }

    // 2) 경로 세그먼트 : 직전 세그먼트들이 역할 문구가 됩니다. (/product/view/18 → "product view")
    for (i, seg) in segs.iter().enumerate() {
        let clean = seg.split('.').next().unwrap_or(seg.as_str());
        if clean.is_empty() { continue; }
        if !clean.chars().any(|c| c.is_ascii_digit()) { continue; }
        if clean.chars().count() > 32 { continue; }

        let mut ctx: Vec<String> = Vec::new();
        if i >= 2 { ctx.push(humanize_url_token(&segs[i - 2])); }
        if i >= 1 { ctx.push(humanize_url_token(&segs[i - 1])); }
        let joined = ctx.into_iter().filter(|s| !s.is_empty()).collect::<Vec<_>>().join(" ");
        let role = if joined.is_empty() { "url path segment".to_string() } else { joined };

        let prior = if i + 1 == segs.len() { 0.92 } else { 0.80 };
        let dedup = format!("P::{}::{}", clean, role);
        if !seen.insert(dedup) { continue; }
        out.push(IdLinkCandidate {
            token: clean.to_string(),
            href: href.to_string(),
            role_phrase: role,
            is_host_part: false,
            prior,
        });
    }

    // 3) 호스트 조각 : 'cafe24' 같은 도메인 파편도 후보로 담되,
    //    도메인 역할 문구를 붙여 코사인이 스스로 떨어뜨리도록 만듭니다.
    for part in host.split('.') {
        if part.is_empty() { continue; }
        if !part.chars().any(|c| c.is_ascii_digit()) { continue; }
        let dedup = format!("H::{}", part);
        if !seen.insert(dedup) { continue; }
        out.push(IdLinkCandidate {
            token: part.to_string(),
            href: href.to_string(),
            role_phrase: "host name domain name website address server address".to_string(),
            is_host_part: true,
            prior: 0.05,
        });
    }
}

pub fn collect_id_link_candidates(lines: &[&str]) -> Vec<IdLinkCandidate> {
    let href_re = match regex::Regex::new(r#"href=["']([^"']+)["']"#) {
        Ok(r) => r,
        Err(_) => return Vec::new(),
    };

    let mut hrefs: Vec<String> = Vec::new();
    for line in lines {
        for cap in href_re.captures_iter(line) {
            if let Some(m) = cap.get(1) {
                let v = m.as_str().trim().to_string();
                if v.is_empty() { continue; }
                let lower = v.to_ascii_lowercase();
                if lower.starts_with("javascript:") || lower.starts_with("mailto:") || lower.starts_with("tel:") { continue; }
                if lower == "#" || lower == "#none" { continue; }
                if !hrefs.contains(&v) { hrefs.push(v); }
            }
        }
    }
    if hrefs.is_empty() { return Vec::new(); }

    let mut out: Vec<IdLinkCandidate> = Vec::new();
    let mut seen: std::collections::HashSet<String> = std::collections::HashSet::new();

    for href in &hrefs {
        push_candidates_from_href(href, &mut out, &mut seen);
    }

    if out.len() > 24 { out.truncate(24); }
    out
}

pub fn collect_id_link_candidates_from_url(page_url: &str) -> Vec<IdLinkCandidate> {
    let mut out: Vec<IdLinkCandidate> = Vec::new();
    let mut seen: std::collections::HashSet<String> = std::collections::HashSet::new();
    let u = page_url.trim();
    if u.is_empty() { return out; }
    push_candidates_from_href(u, &mut out, &mut seen);
    out.retain(|c| !c.is_host_part);
    if out.len() > 24 { out.truncate(24); }
    out
}

#[derive(Debug, Clone)]
pub struct LabeledTokenCandidate {
    pub token: String,
    pub label_phrase: String,
}

fn is_structural_tag_label(label: &str) -> bool {
    let l = label.trim().to_lowercase();
    let tag = l.split(|c: char| c == '[' || c == ' ' || c == '(').next().unwrap_or("");
    ["td", "th", "tr", "div", "span", "p", "a", "li", "ul", "ol", "input", "table", "tbody", "thead", "label", "button", "textarea"]
        .contains(&tag)
}

pub fn collect_labeled_token_candidates(labeled_lines: &[String]) -> Vec<LabeledTokenCandidate> {
    let mut out: Vec<LabeledTokenCandidate> = Vec::new();
    let mut seen: std::collections::HashSet<String> = std::collections::HashSet::new();

    for line in labeled_lines {
        let (label_raw, value) = match line.find('|') {
            Some(p) => (line[..p].trim(), line[p + 1..].trim()),
            None => continue,
        };
        if value.is_empty() { continue; }

        let label = if label_raw.is_empty() || is_structural_tag_label(label_raw) {
            "identifier code number".to_string()
        } else {
            label_raw.to_string()
        };

        for tok in value.split(|c: char| !c.is_alphanumeric()) {
            let n = tok.chars().count();
            if n < 2 || n > 32 { continue; }
            if !tok.chars().any(|c| c.is_ascii_digit()) { continue; }
            let dedup = format!("{}::{}", label, tok);
            if !seen.insert(dedup) { continue; }
            out.push(LabeledTokenCandidate { token: tok.to_string(), label_phrase: label.clone() });
        }
    }

    if out.len() > 48 { out.truncate(48); }
    out
}

pub fn id_shape_signature(token: &str) -> (usize, bool) {
    let n = token.chars().count();
    let digits_only = !token.is_empty() && token.chars().all(|c| c.is_ascii_digit());
    (n, digits_only)
}

pub fn id_shape_allowed(token: &str, learned: &[(usize, bool)]) -> bool {
    if learned.is_empty() { return true; }
    let (n, digits_only) = id_shape_signature(token);

    let mut min_len = usize::MAX;
    let mut max_len = 0usize;
    let mut any_digits_only = false;
    let mut any_mixed = false;
    for (l, d) in learned {
        if *l < min_len { min_len = *l; }
        if *l > max_len { max_len = *l; }
        if *d { any_digits_only = true; } else { any_mixed = true; }
    }

    if digits_only && !any_digits_only { return false; }
    if !digits_only && !any_mixed { return false; }

    let lo = min_len.saturating_sub(2);
    let hi = max_len + 2;
    n >= lo && n <= hi
}

pub fn same_host(a: &str, b: &str) -> bool {
    let (ha, _, _) = split_href_parts(a);
    let (hb, _, _) = split_href_parts(b);
    if ha.is_empty() || hb.is_empty() { return true; }
    ha.eq_ignore_ascii_case(&hb)
}

pub fn resolve_id_link_from_lines(lines: &[&str]) -> Option<(String, String)> {
    let href_re = regex::Regex::new(r#"href=["']([^"']+)["']"#).ok()?;

    let mut hrefs: Vec<String> = Vec::new();
    for line in lines {
        for cap in href_re.captures_iter(line) {
            if let Some(m) = cap.get(1) {
                let v = m.as_str().trim().to_string();
                if !v.is_empty() && !hrefs.contains(&v) { hrefs.push(v); }
            }
        }
    }
    if hrefs.is_empty() { return None; }

    let mut tokens: Vec<String> = Vec::new();
    for line in lines {
        let value = match line.find('|') {
            Some(p) => line[p + 1..].trim(),
            None => continue,
        };
        for tok in value.split(|c: char| !c.is_alphanumeric()) {
            if tok.chars().count() < 6 { continue; }
            if !tok.chars().any(|c| c.is_ascii_digit()) { continue; }
            let t = tok.to_string();
            if !tokens.contains(&t) { tokens.push(t); }
        }
    }
    if tokens.is_empty() { return None; }

    let mut best: Option<(String, String)> = None;
    for tok in &tokens {
        let lower_tok = tok.to_ascii_lowercase();
        for h in &hrefs {
            let lower_h = h.to_ascii_lowercase();
            let start = host_region_end(h);
            if start >= lower_h.len() { continue; }
            if !lower_h[start..].contains(&lower_tok) { continue; }

            let is_better = match &best {
                None => true,
                Some((bt, _)) => tok.chars().count() > bt.chars().count(),
            };
            if is_better { best = Some((tok.clone(), h.clone())); }
        }
    }
    best
}

pub fn extract_url_pattern(id: &str, link: &str) -> Option<(String, String)> {
    if id.is_empty() || link.is_empty() { return None; }
    if !id.is_ascii() { return None; }

    let lower_link = link.to_ascii_lowercase();
    let lower_id = id.to_ascii_lowercase();

    let host_end = host_region_end(link);
    if host_end >= lower_link.len() { return None; }

    // 식별자는 URL 뒤쪽에 오는 것이 일반적이므로 path/query 구간의 '가장 오른쪽' 매칭을 채택합니다.
    let mut pos_opt: Option<usize> = None;
    let mut cursor = host_end;
    while cursor <= lower_link.len() {
        match lower_link[cursor..].find(&lower_id) {
            Some(rel) => {
                let abs = cursor + rel;
                pos_opt = Some(abs);
                cursor = abs + lower_id.len().max(1);
            },
            None => break,
        }
    }

    let pos = pos_opt?;
    let end = pos + id.len();
    if !link.is_char_boundary(pos) || !link.is_char_boundary(end) { return None; }

    let prefix = &link[..pos];
    let suffix = &link[end..];
    if prefix.is_empty() && suffix.is_empty() { return None; }
    Some((prefix.to_string(), suffix.to_string()))
}

// 🌟 [URL PATTERN APPLY] 추출된 패턴에 새 식별자를 대입하여 link를 생성합니다.
pub fn apply_url_pattern(prefix: &str, suffix: &str, new_id: &str) -> String {
    format!("{}{}{}", prefix, new_id, suffix)
}

pub fn find_identifier_token_in_lines(lines: &[String]) -> Option<String> {
    for line in lines {
        let value = match line.find('|') {
            Some(p) => line[p + 1..].trim(),
            None => continue,
        };
        if value.is_empty() { continue; }
        for tok in value.split(|c: char| !c.is_alphanumeric()) {
            let char_count = tok.chars().count();
            if char_count < 8 { continue; }
            if !tok.chars().any(|c| c.is_ascii_digit()) { continue; }
            // 순수 알파벳 토큰은 제외 (숫자가 반드시 포함되어야 함)
            return Some(tok.to_string());
        }
    }
    None
}

pub fn is_dead_href(href: &str) -> bool {
    let h = href.trim().to_ascii_lowercase();
    if h.is_empty() { return true; }
    if h.starts_with('#') { return true; }
    if h.starts_with("javascript:") { return true; }
    if h.starts_with("mailto:") || h.starts_with("tel:") { return true; }
    false
}

pub fn line_real_href(line: &str) -> Option<String> {
    let re = match regex::Regex::new(r#"href=["']([^"']+)["']"#) {
        Ok(r) => r,
        Err(_) => return None,
    };
    for cap in re.captures_iter(line) {
        if let Some(m) = cap.get(1) {
            let v = m.as_str().trim();
            if !is_dead_href(v) { return Some(v.to_string()); }
        }
    }
    None
}

pub fn is_multi_value_field(field_name: &str) -> bool {
    let lower = field_name.to_lowercase();
    ["options", "tags", "goods", "additional_goods", "additional_image", "region_restrictions", "address"]
        .iter()
        .any(|k| lower.contains(k))
}

pub fn pug_line_parts(line: &str) -> (usize, String, String, String) {
    let indent = line.chars().take_while(|c| c.is_whitespace()).count();
    let trimmed = line.trim();
    let chars: Vec<char> = trimmed.chars().collect();

    let mut depth = 0i32;
    let mut in_quote: Option<char> = None;
    let mut pipe_pos: Option<usize> = None;

    for (i, ch) in chars.iter().enumerate() {
        match in_quote {
            Some(q) => { if *ch == q { in_quote = None; } },
            None => {
                if *ch == '"' || *ch == '\'' { in_quote = Some(*ch); }
                else if *ch == '[' { depth += 1; }
                else if *ch == ']' { depth -= 1; }
                else if *ch == '|' && depth <= 0 { pipe_pos = Some(i); break; }
            }
        }
    }

    let (head, value) = match pipe_pos {
        Some(p) => (
            chars[..p].iter().collect::<String>().trim().to_string(),
            chars[p + 1..].iter().collect::<String>().trim().to_string(),
        ),
        None => (trimmed.to_string(), String::new()),
    };

    let tag = head.split(|c: char| c == '[' || c == ' ' || c == '(').next().unwrap_or("").to_lowercase();
    let attrs = match head.find('[') { Some(p) => head[p..].to_string(), None => String::new() };
    (indent, tag, attrs, value)
}

// 🌟 PUG 속성부에서 특정 속성값을 꺼냅니다. (구조 파싱 전용, 의미 판정에는 쓰지 않습니다)
pub fn pug_attr_string(attrs: &str, key: &str) -> Option<String> {
    let pat = format!("{}=\"", key);
    let start = attrs.find(&pat)? + pat.len();
    let rest = &attrs[start..];
    let end = rest.find('"')?;
    Some(rest[..end].to_string())
}

pub fn pug_attr_number(attrs: &str, key: &str) -> Option<usize> {
    pug_attr_string(attrs, key).and_then(|v| v.trim().parse::<usize>().ok())
}

pub fn pug_attr_flag(attrs: &str, key: &str) -> bool {
    attrs.split(|c: char| c == '[' || c == ']' || c == ' ')
        .any(|t| t == key || t.starts_with(&format!("{}=", key)))
}

// 🌟 컬럼 '제목' 역할 태그 (값이 될 수 없는 태그)
pub fn is_label_role_tag(tag: &str) -> bool {
    matches!(tag, "th" | "label" | "legend" | "caption" | "dt"
        | "h1" | "h2" | "h3" | "h4" | "h5" | "h6")
}

// 🌟 값 라인이 될 수 없는 태그 (제목 + 순수 컨테이너)
pub fn is_non_value_role_tag(tag: &str) -> bool {
    if is_label_role_tag(tag) { return true; }
    matches!(tag, "tr" | "table" | "thead" | "tbody" | "tfoot"
        | "colgroup" | "col" | "form" | "button")
}

pub fn is_heading_tag(tag: &str) -> bool {
    matches!(tag, "h1" | "h2" | "h3" | "h4" | "h5" | "h6" | "legend" | "caption")
}

// 🌟 [STRUCTURAL LABEL-VALUE PAIR] 상세페이지의 라벨-값 결합 결과
#[derive(Debug, Clone)]
pub struct DetailPair {
    pub label: String,        // 예: "결제방법", "주문상태"
    pub section: String,      // 가장 가까운 상위 제목 (예: "주문하신 분")
    pub value: String,        // 대표값 (단일 값 필드용)
    pub value_all: String,    // 셀 전체 병합값 (주소 등 다중 값 필드용)
    pub primary_line: usize,  // 대표값이 위치한 라인 인덱스
    pub label_line: usize,
}

fn detail_block_end(lines: &[&str], parts: &[(usize, String, String, String)], start: usize) -> usize {
    let base = parts[start].0;
    let mut end = start;
    for j in (start + 1)..lines.len() {
        if lines[j].trim().is_empty() { continue; }
        if parts[j].0 <= base { break; }
        end = j;
    }
    end
}

fn detail_cell_label_text(
    lines: &[&str],
    parts: &[(usize, String, String, String)],
    start: usize,
    end: usize,
) -> String {
    if !parts[start].3.trim().is_empty() { return parts[start].3.trim().to_string(); }
    for j in (start + 1)..=end {
        if lines[j].trim().is_empty() { continue; }
        let t = parts[j].3.trim();
        if t.is_empty() { continue; }
        if parts[j].1 == "input" || parts[j].1 == "button" { continue; }
        return t.to_string();
    }
    String::new()
}

fn detail_cell_value_text(
    lines: &[&str],
    parts: &[(usize, String, String, String)],
    start: usize,
    end: usize,
) -> (String, String, usize) {
    // 1차 : 값이 될 자격이 있는 라인만 추려 '최소 깊이'를 확정합니다.
    let mut candidates: Vec<usize> = Vec::new();
    let mut min_indent = usize::MAX;
    for j in start..=end {
        if lines[j].trim().is_empty() { continue; }
        let (indent, tag, attrs, text) = &parts[j];
        if text.trim().is_empty() { continue; }

        // 라벨/버튼/제목은 값이 아닙니다.
        if tag == "label" || tag == "button" || tag == "legend" || tag == "caption" { continue; }
        if tag == "th" && j != start { continue; }
        // 히든 인풋은 화면에 없는 내부 상태값이므로 셀 값 병합에서 제외합니다.
        if tag == "input" && pug_attr_string(attrs, "type").as_deref() == Some("hidden") { continue; }

        if *indent < min_indent { min_indent = *indent; }
        candidates.push(j);
    }
    if candidates.is_empty() { return (String::new(), String::new(), start); }

    let mut best_rank = -1i32;
    let mut best_text = String::new();
    let mut best_line = start;
    let mut joined: Vec<String> = Vec::new();

    for j in candidates {
        // 🌟 최소 깊이보다 깊은 라인 = 그 셀의 '부가 위젯'이므로 대표값에도 병합값에도 넣지 않습니다.
        if parts[j].0 > min_indent { continue; }

        let tag = &parts[j].1;
        let owned = parts[j].3.trim().to_string();

        let rank = if line_real_href(lines[j]).is_some() {
            3
        } else if tag == "input" || tag == "option" || tag == "select" || tag == "textarea" {
            2
        } else if lines[j].contains("href=") {
            0
        } else {
            1
        };

        if !joined.iter().any(|e| e == &owned) { joined.push(owned.clone()); }

        if rank > best_rank || (rank == best_rank && owned.chars().count() > best_text.chars().count()) {
            best_rank = rank;
            best_text = owned;
            best_line = j;
        }
    }

    (best_text, joined.join(" "), best_line)
}

pub fn collect_detail_label_value_pairs(lines: &[&str]) -> Vec<DetailPair> {
    let n = lines.len();
    if n == 0 { return Vec::new(); }

    let parts: Vec<(usize, String, String, String)> =
        lines.iter().map(|l| pug_line_parts(l)).collect();

    // 가장 가까운 상위 제목(섹션) 계산
    let mut sections: Vec<String> = vec![String::new(); n];
    {
        let mut cur = String::new();
        for i in 0..n {
            if !lines[i].trim().is_empty() && is_heading_tag(&parts[i].1) && !parts[i].3.trim().is_empty() {
                cur = parts[i].3.trim().to_string();
            }
            sections[i] = cur.clone();
        }
    }

    // 가장 가까운 상위 table 라인
    let enclosing_table = |idx: usize| -> usize {
        let mut target_indent = parts[idx].0;
        for j in (0..idx).rev() {
            if lines[j].trim().is_empty() { continue; }
            let ind = parts[j].0;
            if ind < target_indent {
                if parts[j].1 == "table" { return j; }
                target_indent = ind;
            }
        }
        usize::MAX
    };

    let mut pairs: Vec<DetailPair> = Vec::new();
    let mut table_headers: std::collections::HashMap<usize, std::collections::HashMap<usize, String>> =
        std::collections::HashMap::new();

    for i in 0..n {
        if lines[i].trim().is_empty() { continue; }
        if parts[i].1 != "tr" { continue; }

        let tr_end = detail_block_end(lines, &parts, i);
        if tr_end <= i { continue; }

        let child_indent = {
            let mut ci = None;
            for j in (i + 1)..=tr_end {
                if lines[j].trim().is_empty() { continue; }
                if parts[j].0 > parts[i].0 { ci = Some(parts[j].0); break; }
            }
            match ci { Some(v) => v, None => continue }
        };

        let mut cells: Vec<(usize, String, usize, usize)> = Vec::new();
        let mut col_cursor = 0usize;
        for j in (i + 1)..=tr_end {
            if lines[j].trim().is_empty() { continue; }
            if parts[j].0 != child_indent { continue; }
            let tag = parts[j].1.clone();
            if tag != "td" && tag != "th" { continue; }
            let colspan = pug_attr_number(&parts[j].2, "colspan").unwrap_or(1).max(1);
            let cell_end = detail_block_end(lines, &parts, j).max(j);
            cells.push((j, tag, col_cursor, cell_end));
            col_cursor += colspan;
        }
        if cells.is_empty() { continue; }

        let table_id = enclosing_table(i);
        let all_th = cells.iter().all(|(_, t, _, _)| t == "th");

        if all_th {
            let map = table_headers.entry(table_id).or_insert_with(std::collections::HashMap::new);
            for (line_idx, _, col, cell_end) in &cells {
                let txt = detail_cell_label_text(lines, &parts, *line_idx, *cell_end);
                if txt.is_empty() { continue; }
                map.insert(*col, txt);
            }
            continue;
        }

        let mut pending_label: Option<(String, usize)> = None;
        for (line_idx, tag, col, cell_end) in &cells {
            if tag == "th" {
                let txt = detail_cell_label_text(lines, &parts, *line_idx, *cell_end);
                if !txt.is_empty() { pending_label = Some((txt, *line_idx)); }
                continue;
            }

            let (rep, all_v, prim) = detail_cell_value_text(lines, &parts, *line_idx, *cell_end);
            let (label, label_line) = if let Some((l, li)) = pending_label.clone() {
                (l, li)
            } else if let Some(m) = table_headers.get(&table_id) {
                match m.get(col) { Some(h) => (h.clone(), *line_idx), None => (String::new(), *line_idx) }
            } else {
                (String::new(), *line_idx)
            };
            pending_label = None;

            if label.trim().is_empty() || rep.trim().is_empty() { continue; }
            pairs.push(DetailPair {
                label: label.trim().to_string(),
                section: sections[label_line].clone(),
                value: rep,
                value_all: all_v,
                primary_line: prim,
                label_line,
            });
        }
    }

    let structural_lines: std::collections::HashSet<usize> =
        pairs.iter().map(|p| p.primary_line).collect();

    for i in 0..n {
        if lines[i].trim().is_empty() { continue; }
        if parts[i].1 != "input" && parts[i].1 != "textarea" { continue; }
        let ph = match pug_attr_string(&parts[i].2, "placeholder") { Some(v) => v, None => continue };
        if ph.trim().is_empty() { continue; }
        let v = parts[i].3.trim().to_string();
        if v.is_empty() { continue; }
        if structural_lines.contains(&i) { continue; }
        pairs.push(DetailPair {
            label: ph.trim().to_string(),
            section: sections[i].clone(),
            value: v.clone(),
            value_all: v,
            primary_line: i,
            label_line: i,
        });
    }

    pairs
}

pub fn extract_pug_context(lines: &[&str], target_idx: usize) -> String {
    if lines.is_empty() { return String::new(); }
    let mut parent_idx = target_idx;
    let target_indent = lines[target_idx].chars().take_while(|c| c.is_whitespace()).count();
    
    for i in (0..target_idx).rev() {
        let indent = lines[i].chars().take_while(|c| c.is_whitespace()).count();
        if indent < target_indent && !lines[i].trim().is_empty() {
            parent_idx = i;
            break;
        }
    }

    let parent_indent = lines[parent_idx].chars().take_while(|c| c.is_whitespace()).count();
    let mut context_lines = vec![lines[parent_idx]];
    
    for i in (parent_idx + 1)..lines.len() {
        if lines[i].trim().is_empty() { continue; }
        let indent = lines[i].chars().take_while(|c| c.is_whitespace()).count();
        if indent <= parent_indent {
            break;
        }
        context_lines.push(lines[i]);
    }
    
    context_lines.join("\n")
}