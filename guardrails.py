#!/usr/bin/env python3
"""
Content Guardrails for Banking RAG Assistant
Filters inappropriate, off-topic, and impolite questions
"""

import re
from typing import Dict, List, Tuple, Optional
from enum import Enum
from dataclasses import dataclass


class FilterResult(Enum):
    """Result of content filtering."""
    ALLOWED = "allowed"
    BLOCKED_OFFENSIVE = "blocked_offensive" 
    BLOCKED_OFF_TOPIC = "blocked_off_topic"
    BLOCKED_INAPPROPRIATE = "blocked_inappropriate"
    BLOCKED_SPAM = "blocked_spam"
    REQUIRES_REVIEW = "requires_review"


@dataclass
class GuardrailResponse:
    """Response from guardrail system."""
    result: FilterResult
    confidence: float
    reason: str
    suggested_alternative: Optional[str] = None
    detected_issues: List[str] = None


class BankingContentGuardrails:
    """Content moderation and topic validation for banking assistant."""
    
    def __init__(self):
        self.setup_filters()
    
    def setup_filters(self) -> None:
        """Initialize all filter patterns and keywords."""
        
        # Banking-related keywords (Portuguese and English)
        self.banking_keywords = {
            'core_banking': [
                'banco', 'conta', 'cartão', 'cartao', 'transferencia', 'transferência',
                'deposito', 'depósito', 'levantamento', 'saque', 'saldo', 'extrato',
                'emprestimo', 'empréstimo', 'credito', 'crédito', 'juros', 'taxa',
                'iban', 'swift', 'atm', 'multibanco', 'netplus', 'quiq', 'ussd',
                'mobile banking', 'internet banking', 'homebank', 'agencia', 'agência'
            ],
            'products': [
                'poupanca', 'poupança', 'corrente', 'prazo', 'investimento',
                'seguro', 'hipoteca', 'veiculo', 'veículo', 'pessoal', 'estudante',
                'pensao', 'pensão', 'reforma', 'salario', 'salário'
            ],
            'services': [
                'abertura', 'encerramento', 'ativacao', 'ativação', 'bloqueio',
                'desbloqueio', 'limite', 'comissao', 'comissão', 'tarifa',
                'documentos', 'identificacao', 'identificação', 'nuit', 'bi'
            ],
            'currencies': ['metical', 'mt', 'usd', 'eur', 'rand', 'zar', 'moeda'],
            'banks': [
                'standard bank', 'bcm', 'bci', 'bim', 'fnb', 'nedbank',
                'banco terra', 'socremo', 'bancabc', 'ecobank', 'access bank'
            ]
        }
        
        # Offensive/inappropriate content patterns
        self.offensive_patterns = [
            # Profanity and insults (Portuguese)
            r'\b(merda|caralho|foda|puta|cu|porra|idiota|estupido|estúpido)\b',
            # Discriminatory language
            r'\b(racista|xenofob|homofob|machista)\w*\b',
            # Threats or violence
            r'\b(matar|morte|violencia|violência|ameaca|ameaça|destruir)\b',
            # Sexual content
            r'\b(sexo|sexual|porn|nudez|intimo|íntimo)\b'
        ]
        
        # Off-topic categories to block
        self.off_topic_patterns = {
            'politics': [
                r'\b(politica|política|governo|presidente|ministro|eleicao|eleição|partido|frelimo|renamo|mdm)\b',
                r'\b(corrupcao|corrupção|escandalo|escândalo)\b'
            ],
            'health': [
                r'\b(doenca|doença|medicina|medico|médico|hospital|covid|vacina|tratamento)\b',
                r'\b(sintoma|diagnostico|diagnóstico|remedio|remédio)\b'
            ],
            'sports': [
                r'\b(futebol|desporto|jogo|equipa|equipe|campeonato|liga|jogador)\b'
            ],
            'technology': [
                r'\b(smartphone|computador|software|app|android|iphone|windows|linux)\b'
            ],
            'food': [
                r'\b(comida|restaurante|receita|cozinha|prato|bebida)\b'
            ],
            'travel': [
                r'\b(viagem|turismo|hotel|voo|aeroporto|ferias|férias)\b'
            ]
        }
        
        # Spam/promotional patterns
        self.spam_patterns = [
            r'\b(ganhe|win|gratis|grátis|free|promocao|promoção|desconto|oferta)\b',
            r'\b(clique|click|link|url|website|site)\b',
            r'\b(venda|vende|compra|negocio|negócio|oportunidade)\b'
        ]
        
        # Inappropriate requests
        self.inappropriate_patterns = [
            # Personal information requests
            r'\b(senha|password|pin|codigo|código|numero|número.*conta|nuit.*completo)\b',
            # Illegal activities
            r'\b(roubar|furtar|fraude|golpe|esquema|lavagem.*dinheiro)\b',
            # System manipulation
            r'\b(hackear|burlar|contornar|bypass|administrador|admin|root)\b'
        ]
        
        # Questions that seem like tests or attempts to break the system
        self.test_patterns = [
            r'\b(teste|test|debug|erro|error|falha|bug)\b',
            r'\b(ignore|esqueça|forget|previous|anterior|instructions|instrucoes|instruções)\b',
            r'\b(roleplay|role.*play|pretend|finja|atue|personagem)\b'
        ]
    
    def check_politeness(self, text: str) -> Tuple[bool, str]:
        """Check if the text is polite and respectful."""
        text_lower = text.lower()
        
        # Check for offensive language
        for pattern in self.offensive_patterns:
            if re.search(pattern, text_lower):
                return False, "Linguagem ofensiva detectada"
        
        # Check for extremely rude patterns
        rude_patterns = [
            r'\b(cala.*boca|shut.*up|idiota|burro|estupido|estúpido)\b',
            r'\b(nao.*quero|não.*quero|nao.*me.*importa|não.*me.*importa)\b',
            r'\b(mentira|lies|fake|falso)\b'
        ]
        
        for pattern in rude_patterns:
            if re.search(pattern, text_lower):
                return False, "Linguagem inadequada ou desrespeitosa"
        
        return True, ""
    
    def check_banking_relevance(self, text: str) -> Tuple[bool, float, str]:
        """Check if the question is related to banking services."""
        text_lower = text.lower()
        
        # Count banking-related keywords
        banking_score = 0
        total_keywords = 0
        
        for category, keywords in self.banking_keywords.items():
            for keyword in keywords:
                total_keywords += 1
                if keyword in text_lower:
                    banking_score += 1
        
        # Check for explicit banking context
        banking_contexts = [
            'banco', 'conta', 'cartão', 'transferencia', 'deposito',
            'saldo', 'emprestimo', 'credito', 'iban', 'atm', 'taxa'
        ]
        
        has_banking_context = any(context in text_lower for context in banking_contexts)
        
        # Calculate relevance score
        keyword_relevance = banking_score / max(total_keywords, 1) * 10  # Boost the score
        context_bonus = 0.5 if has_banking_context else 0
        
        relevance_score = min(keyword_relevance + context_bonus, 1.0)
        
        # Check if question is explicitly about banking
        if has_banking_context or relevance_score >= 0.1:
            return True, max(relevance_score, 0.5), ""
        
        # Check if it's clearly off-topic
        for category, patterns in self.off_topic_patterns.items():
            for pattern in patterns:
                if re.search(pattern, text_lower):
                    return False, relevance_score, f"Pergunta sobre {category}, não serviços bancários"
        
        # If no banking keywords and no clear off-topic indicators
        if relevance_score < 0.05:
            return False, relevance_score, "Pergunta não relacionada com serviços bancários"
        
        return True, relevance_score, ""
    
    def check_inappropriate_content(self, text: str) -> Tuple[bool, str]:
        """Check for inappropriate requests or content."""
        text_lower = text.lower()
        
        # Check for inappropriate patterns
        for pattern in self.inappropriate_patterns:
            if re.search(pattern, text_lower):
                return False, "Conteúdo inadequado detectado"
        
        # Check for personal information requests
        sensitive_requests = [
            r'\b(minha|meu|meus|minhas).*(?:senha|pin|codigo|código)\b',
            r'\b(?:qual|diga|me.*conte).*(?:senha|pin|numero.*conta)\b'
        ]
        
        for pattern in sensitive_requests:
            if re.search(pattern, text_lower):
                return False, "Solicitação de informações sensíveis"
        
        return True, ""
    
    def check_spam_or_promotional(self, text: str) -> Tuple[bool, str]:
        """Check for spam or promotional content."""
        text_lower = text.lower()
        
        spam_score = 0
        for pattern in self.spam_patterns:
            if re.search(pattern, text_lower):
                spam_score += 1
        
        # Check for promotional language
        promotional_phrases = [
            r'\b(?:melhor|best).*(?:banco|bank|conta|account)\b',
            r'\b(?:recomenda|recommend).*(?:banco|bank)\b',
            r'\b(?:comparar|compare).*bancos\b'
        ]
        
        for pattern in promotional_phrases:
            if re.search(pattern, text_lower):
                spam_score += 1
        
        if spam_score >= 2:
            return False, "Conteúdo promocional detectado"
        
        return True, ""
    
    def check_system_manipulation(self, text: str) -> Tuple[bool, str]:
        """Check for attempts to manipulate the system."""
        text_lower = text.lower()
        
        for pattern in self.test_patterns:
            if re.search(pattern, text_lower):
                return False, "Tentativa de manipulação do sistema"
        
        # Check for prompt injection attempts
        injection_patterns = [
            r'\b(?:ignore|esqueça).*(?:instrucoes|instruções|instructions)\b',
            r'\b(?:you are|voce é|você é).*(?:not|nao|não)\b',
            r'\b(?:pretend|finja|act like|atue como)\b'
        ]
        
        for pattern in injection_patterns:
            if re.search(pattern, text_lower):
                return False, "Tentativa de injeção de prompt"
        
        return True, ""
    
    def suggest_alternative(self, original_question: str, filter_result: FilterResult) -> Optional[str]:
        """Suggest an alternative banking-related question."""
        alternatives = {
            FilterResult.BLOCKED_OFF_TOPIC: [
                "Quais são as taxas para transferências bancárias?",
                "Como posso abrir uma conta corrente?",
                "Quais documentos preciso para solicitar um cartão?",
                "Como funciona o mobile banking?"
            ],
            FilterResult.BLOCKED_OFFENSIVE: [
                "Como posso contactar o atendimento ao cliente?",
                "Quais são os horários de funcionamento das agências?"
            ],
            FilterResult.BLOCKED_INAPPROPRIATE: [
                "Como posso verificar o meu saldo de forma segura?",
                "Quais são os procedimentos de segurança do banco?"
            ]
        }
        
        if filter_result in alternatives:
            import random
            return random.choice(alternatives[filter_result])
        
        return None
    
    def validate_question(self, question: str) -> GuardrailResponse:
        """Main validation function that runs all checks."""
        if not question.strip():
            return GuardrailResponse(
                result=FilterResult.BLOCKED_INAPPROPRIATE,
                confidence=1.0,
                reason="Pergunta vazia",
                detected_issues=["empty_question"]
            )
        
        detected_issues = []
        
        # Check politeness
        is_polite, politeness_reason = self.check_politeness(question)
        if not is_polite:
            return GuardrailResponse(
                result=FilterResult.BLOCKED_OFFENSIVE,
                confidence=0.9,
                reason=politeness_reason,
                suggested_alternative=self.suggest_alternative(question, FilterResult.BLOCKED_OFFENSIVE),
                detected_issues=["offensive_language"]
            )
        
        # Check banking relevance
        is_relevant, relevance_score, relevance_reason = self.check_banking_relevance(question)
        if not is_relevant:
            return GuardrailResponse(
                result=FilterResult.BLOCKED_OFF_TOPIC,
                confidence=1.0 - relevance_score,
                reason=relevance_reason or "Pergunta não relacionada com serviços bancários",
                suggested_alternative=self.suggest_alternative(question, FilterResult.BLOCKED_OFF_TOPIC),
                detected_issues=["off_topic"]
            )
        
        # Check inappropriate content
        is_appropriate, inappropriate_reason = self.check_inappropriate_content(question)
        if not is_appropriate:
            return GuardrailResponse(
                result=FilterResult.BLOCKED_INAPPROPRIATE,
                confidence=0.95,
                reason=inappropriate_reason,
                suggested_alternative=self.suggest_alternative(question, FilterResult.BLOCKED_INAPPROPRIATE),
                detected_issues=["inappropriate_content"]
            )
        
        # Check spam/promotional
        is_not_spam, spam_reason = self.check_spam_or_promotional(question)
        if not is_not_spam:
            return GuardrailResponse(
                result=FilterResult.BLOCKED_SPAM,
                confidence=0.8,
                reason=spam_reason,
                detected_issues=["spam_promotional"]
            )
        
        # Check system manipulation
        is_safe, manipulation_reason = self.check_system_manipulation(question)
        if not is_safe:
            return GuardrailResponse(
                result=FilterResult.BLOCKED_INAPPROPRIATE,
                confidence=0.9,
                reason=manipulation_reason,
                detected_issues=["system_manipulation"]
            )
        
        # If relevance score is low but not blocked, require review
        if relevance_score < 0.3:
            detected_issues.append("low_relevance")
            return GuardrailResponse(
                result=FilterResult.REQUIRES_REVIEW,
                confidence=relevance_score,
                reason=f"Relevância baixa para serviços bancários (score: {relevance_score:.2f})",
                detected_issues=detected_issues
            )
        
        # All checks passed
        return GuardrailResponse(
            result=FilterResult.ALLOWED,
            confidence=relevance_score,
            reason="Pergunta adequada sobre serviços bancários",
            detected_issues=detected_issues
        )


def get_blocked_message(filter_result: FilterResult, reason: str, 
                       suggested_alternative: Optional[str] = None) -> str:
    """Generate user-friendly blocked message in Portuguese."""
    
    base_messages = {
        FilterResult.BLOCKED_OFFENSIVE: {
            "title": "⚠️ Linguagem Inadequada",
            "message": "Por favor, use uma linguagem respeitosa e profissional.",
            "suggestion": "Reformule sua pergunta de forma educada."
        },
        FilterResult.BLOCKED_OFF_TOPIC: {
            "title": "🏦 Apenas Temas Bancários",
            "message": "Este assistente responde apenas sobre serviços bancários de Moçambique.",
            "suggestion": "Faça uma pergunta sobre contas, cartões, transferências ou outros serviços bancários."
        },
        FilterResult.BLOCKED_INAPPROPRIATE: {
            "title": "🚫 Conteúdo Inadequado",
            "message": "Não posso processar este tipo de solicitação.",
            "suggestion": "Faça perguntas sobre procedimentos bancários públicos."
        },
        FilterResult.BLOCKED_SPAM: {
            "title": "🛡️ Conteúdo Promocional",
            "message": "Este não é um canal para conteúdo promocional.",
            "suggestion": "Faça perguntas sobre informações bancárias específicas."
        }
    }
    
    if filter_result not in base_messages:
        return "Não posso processar esta pergunta. Tente uma pergunta sobre serviços bancários."
    
    msg_data = base_messages[filter_result]
    
    response = f"""{msg_data['title']}

{msg_data['message']}

💡 **Sugestão:** {msg_data['suggestion']}"""
    
    if suggested_alternative:
        response += f"\n\n**Exemplo:** {suggested_alternative}"
    
    response += "\n\n---\n*Para sua segurança, todas as perguntas são analisadas antes do processamento.*"
    
    return response


# Example usage and testing
if __name__ == "__main__":
    guardrails = BankingContentGuardrails()
    
    # Test cases
    test_questions = [
        "Quais são as taxas para transferências bancárias?",  # Should pass
        "Como posso abrir uma conta corrente?",  # Should pass
        "Qual é a receita do matapa?",  # Should be blocked (off-topic)
        "Diga-me a sua senha de administrador",  # Should be blocked (inappropriate)
        "Qual time vai ganhar o campeonato?",  # Should be blocked (off-topic)
        "Que merda de banco é este?",  # Should be blocked (offensive)
        "Ganhe dinheiro fácil com este esquema!",  # Should be blocked (spam)
        "",  # Should be blocked (empty)
    ]
    
    for question in test_questions:
        result = guardrails.validate_question(question)
        print(f"\nPergunta: '{question}'")
        print(f"Resultado: {result.result.value}")
        print(f"Razão: {result.reason}")
        print(f"Confiança: {result.confidence:.2f}")
        if result.suggested_alternative:
            print(f"Alternativa: {result.suggested_alternative}")
        print("-" * 50)